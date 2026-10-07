"""Пайплайн: mp3 -> транскрипция -> сцены и промпты (LLM) -> картинки (-> оживление в видео) -> ролик 1920x1080.

Всё промежуточное складывается в jobs/<имя_mp3>/ и при перезапуске переиспользуется,
так что упавшую на середине работу можно просто запустить снова.

Запуск из консоли:  python pipeline.py файл.mp3 [--provider fastgen|nonstop|both] [--mode images|video] [--style cinematic] [--refs]
"""
import concurrent.futures as cf
import collections
import json
import math
import os
import re
import shutil
import subprocess
import sys
import threading
import time

import requests
import endpoints
import netutil

from fastgen_api import BASE_URL, FastGen, app_dir, data_dir, file_to_data_uri
from nonstop_api import NonStop, NonStopError, MODELS as NONSTOP_MODELS
from yougen_api import YouGen, YouGenError, IMAGE_MODELS as YOUGEN_MODELS
from openai_api import OpenAIClient, DEFAULT_CHAT_MODEL as OPENAI_DEFAULT_MODEL
import subtitles as subs
from google_api import GoogleAI, GoogleError
from royaltechno_api import RoyalTechno, RoyalError, IMAGE_MODELS as ROYAL_MODELS
from secretslider_api import SecretSlider, SliderError
from llm_api import AnthropicClient, GeminiClient, AssemblyAI, LLM_SERVICES
from tts_api import make_tts, TTSError
import hashlib

# ---------- настройки ----------
# fast-gen: режим "скорость" (Flower) и "качество" (Nano Banana Pro)
IMAGE_CHAINS = {
    "speed": [("flower_image_generate", 3)],
    "quality": [("nano_banana_2_image_generate", 1), ("nano_banana_pro_image_generate", 1), ("openai_image_generate", 1)],
}
# «качество» = те же модели с портретами героев (Flower референсы не принимает, в «скорости» их нет)
IMAGE_CHAINS_REFS = {
    "speed": [("nano_banana_2_image_generate", 3)],
    "quality": [("nano_banana_2_image_generate", 1), ("nano_banana_pro_image_generate", 1), ("openai_image_generate", 1)],
}
FASTGEN_QUALITY = "speed"  # переключается из настроек (общее для всех сервисов)
NONSTOP_CHAINS = {"speed": [("NARWHAL", 2), ("HARBOR_SEAL", 1), ("GEM_PIX_2", 1)], "quality": [("GEM_PIX_2", 2), ("NARWHAL", 1), ("HARBOR_SEAL", 1)]}
YOUGEN_CHAINS = {"speed": [("nano-banana-2", 2), ("nano-banana-2-lite", 1), ("nano-banana-pro", 1)], "quality": [("nano-banana-pro", 2), ("nano-banana-2", 1), ("nano-banana-2-lite", 1)]}
ROYAL_CHAINS = {"speed": [("nano-banana-2", 2), ("nano-banana-pro", 1)], "quality": [("nano-banana-pro", 2), ("nano-banana-2", 1)]}
IMAGE_CREDITS = {"flower_image_generate": 1, "nano_banana_2_image_generate": 4, "nano_banana_pro_image_generate": 4, "openai_image_generate": 4}
HD_IMAGES = False  # «HD-картинки»: Nano Banana через fast-gen с upscale 2x — вдвое крупнее исходник, 8 кредитов вместо 4
HD_OPS = ("nano_banana_2_image_generate", "nano_banana_pro_image_generate", "nano_banana_2_lite_image_generate")


def image_credits(op):
    base = IMAGE_CREDITS.get(op, 4)
    return base * 2 if HD_IMAGES and op in HD_OPS else base
NONSTOP_CHAIN = [("GEM_PIX_2", 2), ("NARWHAL", 1), ("HARBOR_SEAL", 1)]
# оживление картинки в видео
VIDEO_CHAIN_FASTGEN = [("flower_video_from_image", 2), ("flow_video_from_keyframes", 1)]
VIDEO_CREDITS = {"flower_video_from_image": 1, "flow_video_from_keyframes": 1}
YOUGEN_CHAIN = [("nano-banana-2", 2), ("nano-banana-pro", 1), ("nano-banana-2-lite", 1)]
ROYAL_CHAIN = [("nano-banana-2", 2), ("nano-banana-pro", 1)]
PROVIDERS = ("fastgen", "nonstop", "yougen", "royal", "slider", "google")
PROVIDER_NAMES = {"fastgen": "fast-gen", "nonstop": "veononstop", "yougen": "yougen", "royal": "royaltechno", "slider": "secretslider", "google": "Google"}
SINGLE_KEY = {"fastgen": "fastgen_api_key", "nonstop": "veononstop_api_key", "yougen": "yougen_api_key", "royal": "royaltechno_api_key",
              "slider": "secretslider_api_key", "google": "google_api_key"}
# Google напрямую: скорость — Imagen 4 Fast (референсы не принимает), качество — Nano Banana 2 → Pro с портретами героев
GOOGLE_CHAINS = {"speed": [("imagen-fast", 3)], "quality": [("nb2", 1), ("nbpro", 1), ("imagen", 1)]}
GOOGLE_CHAINS_REFS = {"speed": [("nb2", 2)], "quality": [("nb2", 1), ("nbpro", 1)]}


def provider_keys(cfg, p):
    """Все ключи сервиса: список config.image_keys[p], либо одиночное старое поле."""
    keys = [k.strip() for k in ((cfg.get("image_keys") or {}).get(p) or []) if isinstance(k, str) and k.strip()]
    if not keys and cfg.get(SINGLE_KEY[p]):
        keys = [cfg[SINGLE_KEY[p]].strip()]
    return keys


def base_of(unit):
    """'fastgen#2' -> 'fastgen' (один сервис может работать несколькими ключами)."""
    return unit.split("#")[0]


def unit_name(unit):
    b, _, n = unit.partition("#")
    return PROVIDER_NAMES[b] + (f" (ключ {n})" if n else "")
TEXT_ENGINES = ("fastgen", "openai")  # кто распознаёт речь и пишет промпты
MODES = ("images", "video", "mixed")  # mixed — через одну: видео, картинка, видео...
TRANSITION = 0.5  # секунд на переход в моушн-режиме
SCENE_MIN, SCENE_MAX, SCENE_TARGET = 3.0, 7.0, 5.0
FPS = 25
W, H = 1920, 1080
INLINE_AUDIO_LIMIT = 15 * 1024 * 1024
FG_CHUNK_SECONDS = 1200  # fast-gen: до 25 МБ на файл, режем по 20 минут
DEFAULT_LLM_MODEL = "openai/gpt-5-2"  # сильнее держит конкретику фразы и реже тащит героя в кадр
DEFAULT_LLM_FALLBACK = "openai/gpt-4.1-mini"  # если основная модель недоступна
MAX_LIMIT_WAIT = 3 * 3600  # сколько одна сцена может ждать часовой лимит fast-gen

STYLES = {
    "ultrareal": ("Ультрареализм", "ultra-realistic 16K photograph indistinguishable from reality, physically accurate natural lighting, "
                  "true-to-life skin, fabric and material textures, professional cinema camera, subtle depth of field, "
                  "no CGI or illustration look, no stylization"),
}
DEFAULT_STYLE = "ultrareal"


def normalize_providers(value):
    """Принимает строку ('fastgen', 'both', 'fastgen,yougen') или список; возвращает список в порядке PROVIDERS."""
    if not value:
        return ["fastgen"]
    if isinstance(value, str):
        value = ["fastgen", "nonstop"] if value == "both" else re.split(r"[,\s]+", value.strip())
    chosen = [p for p in PROVIDERS if p in value]
    return chosen or ["fastgen"]

NO_WINDOW = getattr(subprocess, "CREATE_NO_WINDOW", 0)
LOG_PATH = os.path.join(data_dir(), "videogen.log")

# флаг отмены: ставится из окна, проверяется во всех длинных циклах
CANCEL = threading.Event()

# что программа ждёт прямо сейчас (лимит сервиса) — окно показывает это с таймером, чтобы не казалось, что всё зависло
WAIT = {}


def set_wait(kind, until=None):
    WAIT.update({"kind": kind, "until": until, "since": WAIT.get("since") or time.time()})


def clear_wait(kind=None):
    if not kind or WAIT.get("kind") == kind:
        WAIT.clear()


class Cancelled(Exception):
    pass


def check_cancel():
    if CANCEL.is_set():
        raise Cancelled("Остановлено пользователем")


netutil.CANCEL_CHECK = check_cancel  # циклы ожидания в клиентах сервисов теперь тоже слышат «Стоп»


def ffmpeg_bin(name="ffmpeg"):
    p = os.path.join(app_dir(), "ffmpeg", name + ".exe")
    return p if os.path.exists(p) else name


def log(msg):
    line = f"{time.strftime('%Y-%m-%d %H:%M:%S')} {msg}"
    try:
        print(line, flush=True)
    except Exception:
        pass
    try:
        with open(LOG_PATH, "a", encoding="utf-8") as f:
            f.write(line + "\n")
    except Exception:
        pass


class Progress:
    def __init__(self, cb=None):
        self.cb = cb

    def __call__(self, stage, done=0, total=0, message=""):
        log(f"[{stage}] {message} {f'{done}/{total}' if total else ''}")
        if self.cb:
            self.cb(stage, done, total, message)


# ============ утилиты ============

def read_json(path, default=None):
    if os.path.exists(path):
        with open(path, encoding="utf-8") as f:
            return json.load(f)
    return default


def write_json(path, data):
    tmp = path + ".tmp"
    with open(tmp, "w", encoding="utf-8") as f:
        json.dump(data, f, ensure_ascii=False, indent=1)
    for attempt in range(10):  # файл может держать антивирус или параллельное чтение — ждём и пробуем снова
        try:
            os.replace(tmp, path)
            return
        except PermissionError:
            if attempt == 9:
                raise
            time.sleep(0.15 * (attempt + 1))


def run_ffmpeg(args, check=True):
    r = subprocess.run([ffmpeg_bin(), "-y", "-loglevel", "error", *args], capture_output=True, creationflags=NO_WINDOW)
    if check and r.returncode != 0:
        raise RuntimeError("ffmpeg: " + r.stderr.decode(errors="replace")[:400])
    return r


def audio_duration(path):
    out = subprocess.run(
        [ffmpeg_bin("ffprobe"), "-v", "error", "-show_entries", "format=duration", "-of", "csv=p=0", path],
        capture_output=True, text=True, check=True, creationflags=NO_WINDOW,
    ).stdout.strip()
    return float(out)


def load_config():
    path = os.path.join(data_dir(), "config.json")
    if not os.path.exists(path):
        raise SystemExit("Не найден config.json — введите ключи в окне программы.")
    for attempt in range(5):  # окно в этот момент может переписывать файл — подождём
        try:
            with open(path, encoding="utf-8") as f:
                cfg = json.load(f)
            endpoints.configure(cfg)  # свои адреса API, если заданы
            return cfg
        except (PermissionError, json.JSONDecodeError):
            if attempt == 4:
                raise
            time.sleep(0.15 * (attempt + 1))


def make_text_engine(cfg):
    """Возвращает (stt_name, stt_api, llm_name, llm_api).
    С ключом fast-gen всё идёт через него; без него — распознавание Whisper/AssemblyAI, тексты OpenAI/Claude/Gemini."""
    has_fg = bool(cfg.get("fastgen_api_key"))
    stt = (cfg.get("stt_engine") or ("fastgen" if has_fg else "whisper")).lower()
    llm = (cfg.get("llm_engine") or ("fastgen" if has_fg else "openai")).lower()
    if stt == "fastgen" and not has_fg:
        stt = "whisper"
    if llm == "fastgen" and not has_fg:
        llm = "openai"
    fg = FastGen(cfg["fastgen_api_key"]) if has_fg else None
    if stt == "fastgen":
        stt_api = fg
    elif stt == "assemblyai":
        if not cfg.get("assemblyai_api_key"):
            raise SystemExit("Для распознавания речи выбран AssemblyAI, но ключ не введён.")
        stt_api = AssemblyAI(cfg["assemblyai_api_key"])
    else:
        if not cfg.get("openai_api_key"):
            raise SystemExit("Для распознавания речи нужен ключ OpenAI (Whisper).")
        stt_api = OpenAIClient(cfg["openai_api_key"])
    if llm == "fastgen":
        llm_api = fg
    elif llm == "anthropic":
        if not cfg.get("anthropic_api_key"):
            raise SystemExit("Для текстов выбран Claude, но ключ Anthropic не введён.")
        llm_api = AnthropicClient(cfg["anthropic_api_key"], cfg.get("anthropic_model"))
    elif llm == "gemini":
        if not cfg.get("gemini_api_key"):
            raise SystemExit("Для текстов выбран Gemini, но ключ Google не введён.")
        llm_api = GeminiClient(cfg["gemini_api_key"], cfg.get("gemini_model"))
    else:
        if not cfg.get("openai_api_key"):
            raise SystemExit("Для текстов выбран OpenAI, но ключ не введён.")
        llm_api = OpenAIClient(cfg["openai_api_key"])
    return stt, stt_api, llm, llm_api


def short_base(name, keep=32):
    """Короткое безопасное имя для папки задания и выходного файла.
    Озвучка из Telegram-ботов приходит с именем в целое предложение; вместе с jobs/<имя>/clips_m/0123.mp4
    путь упирался в лимит Windows (260 символов) — WinError 206 «имя файла слишком длинное»."""
    base = re.sub(r"[^\w\-]+", "_", name).strip("_") or "audio"
    if len(base) <= 40:
        return base
    return base[:keep].rstrip("_") + "_" + hashlib.sha1(name.encode("utf-8")).hexdigest()[:6]


def job_dir_for(audio_path):
    name = os.path.splitext(os.path.basename(audio_path))[0]
    base = short_base(name)
    root = os.path.join(data_dir(), "jobs")
    d = os.path.join(root, base)
    old = os.path.join(root, re.sub(r"[^\w\-]+", "_", name))
    if old != d and not os.path.exists(d) and os.path.isdir(old):
        try:
            os.rename(old, d)  # задание из старой версии с длинным именем — переносим, чтобы не делать заново
        except OSError:
            pass
    os.makedirs(d, exist_ok=True)
    return d, base


# ============ шаг 1: транскрипция ============

def clean_words(words):
    """Распознаватель иногда отдаёт слова с обратным скачком времени (в середине часового ролика вдруг 12 с).
    Такие слова выбрасываем, остальные делаем монотонными — иначе сцена получает отрицательную длительность."""
    out, last_end = [], 0.0
    for w in words or []:
        try:
            s, e = float(w["start"]), float(w["end"])
        except (KeyError, TypeError, ValueError):
            continue
        if e < s or s < last_end - 1.5 or e - s > 30:
            continue
        s = max(s, last_end)
        e = max(e, s + 0.05)
        out.append({**w, "start": s, "end": e})
        last_end = e
    return out


def stt_fallbacks(engine):
    """Запасные распознаватели по ключам из настроек (кроме того, что уже выбран)."""
    cfg = load_config()
    out = []
    if engine != "fastgen" and cfg.get("fastgen_api_key"):
        out.append(("fastgen", FastGen(cfg["fastgen_api_key"])))
    if engine != "assemblyai" and cfg.get("assemblyai_api_key"):
        out.append(("assemblyai", AssemblyAI(cfg["assemblyai_api_key"])))
    if engine not in ("openai", "whisper") and cfg.get("openai_api_key"):
        out.append(("whisper", OpenAIClient(cfg["openai_api_key"])))
    return out


def transcribe(engine, api, audio_path, job_dir, progress, duration=None):
    try:
        data = _transcribe_raw(engine, api, audio_path, job_dir, progress, duration)
    except Cancelled:
        raise
    except Exception as e:
        first = e
        fb = stt_fallbacks(engine)
        if not fb:
            raise
        log(f"распознавание ({engine}) не удалось: {str(e)[:200]} — пробую запасной сервис")
        data = None
        for eng2, api2 in fb:
            try:
                progress("transcribe", 0, 1, f"{engine} не ответил, распознаю через {eng2}")
                data = _transcribe_raw(eng2, api2, audio_path, job_dir, progress, duration)
                break
            except Cancelled:
                raise
            except Exception as e2:
                log(f"запасное распознавание ({eng2}) тоже не удалось: {str(e2)[:200]}")
        if data is None:
            raise first
    n = len(data.get("words") or [])
    data["words"] = clean_words(data.get("words"))
    if len(data["words"]) < n:
        log(f"транскрипция: выброшено {n - len(data['words'])} слов с битыми таймкодами")
    return data


def _transcribe_raw(engine, api, audio_path, job_dir, progress, duration=None):
    """engine: 'fastgen' (Gemini через fast-gen) или 'openai' (Whisper)."""
    out = os.path.join(job_dir, "transcript.json")
    cached = read_json(out)
    if cached:
        progress("transcribe", 1, 1, "транскрипция уже есть, пропускаю")
        return cached
    if engine == "assemblyai":
        progress("transcribe", 0, 1, "распознаю речь (AssemblyAI)")
        data = api.transcribe(audio_path, progress=lambda m: progress("transcribe", 0, 1, m))
        if not data["words"]:
            raise RuntimeError("Распознавание вернулось без таймкодов слов")
        write_json(out, data)
        progress("transcribe", 1, 1, f"распознано слов: {len(data['words'])}")
        return data
    if engine in ("openai", "whisper"):
        progress("transcribe", 0, 1, "распознаю речь (OpenAI Whisper)")
        data = api.transcribe(audio_path, ffmpeg_bin(), ffmpeg_bin("ffprobe"), duration or audio_duration(audio_path), progress=progress)
        if not data["words"]:
            raise RuntimeError("Распознавание вернулось без таймкодов слов")
        write_json(out, data)
        progress("transcribe", 1, 1, f"распознано слов: {len(data['words'])}")
        return data
    # fast-gen принимает аудио до 25 МБ. Исходный mp3 не отправляем никогда (бывает 320 кбит/с стерео):
    # всегда пережимаем в моно 48 кбит/с (20 минут ≈ 7 МБ) и длинную озвучку режем по FG_CHUNK_SECONDS.
    duration = duration or audio_duration(audio_path)
    n_chunks = 1 if duration <= FG_CHUNK_SECONDS + 60 else int(math.ceil(duration / FG_CHUNK_SECONDS))
    words, texts = [], []
    import tempfile
    with tempfile.TemporaryDirectory() as tmp:
        def do_chunk(k):
            texts, words = [], []
            check_cancel()
            start = k * FG_CHUNK_SECONDS
            part = os.path.join(tmp, f"part{k:03d}.mp3")
            cut = [] if n_chunks == 1 else ["-ss", str(start), "-t", str(FG_CHUNK_SECONDS)]
            run_ffmpeg([*cut, "-i", audio_path, "-vn", "-ac", "1", "-ar", "16000", "-b:a", "48k", part])
            if os.path.getsize(part) > 20 * 1024 * 1024:
                raise RuntimeError("Кусок аудио получился больше 20 МБ — проверьте файл озвучки")
            label = "" if n_chunks == 1 else f", часть {k + 1} из {n_chunks}"
            progress("transcribe", k, max(1, n_chunks), "загружаю аудио" + label)
            # загрузка нескольких мегабайт на слабом интернете может оборваться («write operation timed out») —
            # это не повод ронять весь ролик, повторяем
            inp = netutil.patient(lambda: api.upload_file(part) if os.path.getsize(part) > INLINE_AUDIO_LIMIT else file_to_data_uri(part),
                                  tries=6)
            progress("transcribe", k, max(1, n_chunks), "распознаю речь (Gemini)" + label)
            for attempt in range(6):  # service.overloaded / generation.failed у fast-gen — временно, ждём и повторяем
                st = netutil.patient(lambda: api.run({"operation": "aistudio_gemini_3.5_transcribe", "inputs": [inp],
                                                      "word_timestamps": True, "diarization": False}, poll=3, max_wait=1800), tries=6)
                if st.get("status") == "succeeded":
                    break
                err = f"{st.get('error_code')} {st.get('error')}"
                if attempt == 5 or not any(x in err for x in ("overloaded", "generation.failed", "try again", "accounts_exhausted")):
                    raise RuntimeError(f"Транскрипция не удалась: {err}")
                wait = 30 * (attempt + 1)
                log(f"транскрипция: {err[:80]} — жду {wait} с и повторяю ({attempt + 1}/5)")
                progress("transcribe", k, max(1, n_chunks), f"сервис распознавания перегружен, жду {wait} с и повторяю")
                for _ in range(wait):
                    check_cancel()
                    time.sleep(1)
            r = st["results"][0]
            texts.append((r.get("text") or "").strip())
            for seg in (r.get("transcription") or {}).get("segments") or []:
                for w in seg.get("words") or []:
                    if w.get("start_seconds") is None:
                        continue
                    words.append({"text": w["text"], "start": float(w["start_seconds"]) + start,
                                  "end": float(w.get("end_seconds") or w["start_seconds"]) + start})
            return texts, words

        # куски длинной озвучки распознаём параллельно (по три), порядок слов восстанавливаем по номеру куска
        with cf.ThreadPoolExecutor(max_workers=max(1, min(3, n_chunks))) as ex:
            parts_out = list(ex.map(do_chunk, range(n_chunks)))
    texts = [x for ts, _ in parts_out for x in ts]
    words = [w for _, ws in parts_out for w in ws]
    if not words:
        raise RuntimeError("Транскрипция вернулась без таймкодов слов")
    data = {"text": " ".join(texts), "words": words}
    write_json(out, data)
    progress("transcribe", 1, 1, f"распознано слов: {len(words)}")
    return data


# ============ шаг 2: разбиение на сцены ============

def split_scenes(words, total_duration):
    phrases, cur = [], []
    for i, w in enumerate(words):
        cur.append(w)
        nxt = words[i + 1] if i + 1 < len(words) else None
        strong = re.search(r"[.!?…;]$", w["text"]) is not None
        weak = re.search(r"[,:—-]$", w["text"]) is not None
        pause = nxt is not None and (nxt["start"] - w["end"]) > 0.6
        if strong or weak or pause or nxt is None:
            phrases.append({"start": cur[0]["start"], "end": cur[-1]["end"],
                            "text": " ".join(x["text"] for x in cur), "strong": strong or pause or nxt is None})
            cur = []
    scenes, buf = [], []

    def flush():
        if buf:
            scenes.append({"start": buf[0]["start"], "end": buf[-1]["end"], "text": " ".join(p["text"] for p in buf)})
            buf.clear()

    for p in phrases:
        if not buf:
            buf.append(p)
            continue
        cand_len = p["end"] - buf[0]["start"]
        cur_len = buf[-1]["end"] - buf[0]["start"]
        if cand_len <= SCENE_MAX and (cur_len < SCENE_MIN or (cand_len <= SCENE_TARGET + 1.0 and not buf[-1]["strong"])):
            buf.append(p)
        elif cand_len <= SCENE_MAX and cur_len < SCENE_TARGET:
            buf.append(p)
        else:
            flush()
            buf.append(p)
    flush()
    fixed = []
    for s in scenes:
        length = s["end"] - s["start"]
        if length > SCENE_MAX + 1.0:
            n = int(length // SCENE_TARGET) + 1
            ws = [w for w in words if w["start"] >= s["start"] - 1e-6 and w["end"] <= s["end"] + 1e-6]
            per = max(1, len(ws) // n)
            for k in range(0, len(ws), per):
                chunk = ws[k:k + per]
                fixed.append({"start": chunk[0]["start"], "end": chunk[-1]["end"], "text": " ".join(x["text"] for x in chunk)})
        else:
            fixed.append(s)
    if len(fixed) > 1 and (fixed[-1]["end"] - fixed[-1]["start"]) < SCENE_MIN * 0.6:
        last = fixed.pop()
        fixed[-1]["end"] = last["end"]
        fixed[-1]["text"] += " " + last["text"]
    for i, s in enumerate(fixed):
        s["index"] = i
        s["start"] = 0.0 if i == 0 else fixed[i - 1]["end_cut"]
        s["end_cut"] = fixed[i + 1]["start"] if i + 1 < len(fixed) else max(total_duration, s["end"])
    for s in fixed:
        s["end"] = s.pop("end_cut")
        if s["end"] < s["start"] + 0.3:
            s["end"] = s["start"] + 0.3
        s["duration"] = round(s["end"] - s["start"], 3)
    return fixed


def scenes_ok(scenes):
    """Кэш сцен пригоден: длительности положительные и сцены идут по порядку (старые версии до 0.29 писали отрицательные)."""
    try:
        prev = 0.0
        for s in scenes:
            if float(s["duration"]) <= 0 or float(s["end"]) < float(s["start"]) or float(s["start"]) < prev - 0.01:
                return False
            prev = float(s["start"])
        return True
    except (KeyError, TypeError, ValueError):
        return False


# ============ шаг 3: LLM (чат-модели через fast-gen) ============

def extract_json(text):
    t = text.strip()
    m = re.search(r"```(?:json)?\s*(.*?)```", t, re.S)
    if m:
        t = m.group(1)
    i, j = t.find("{"), t.rfind("}")
    if i < 0 or j < 0:
        raise json.JSONDecodeError("нет JSON в ответе", t, 0)
    return json.loads(t[i:j + 1])


class LLM:
    """Языковая модель: чат-эндпоинт fast-gen (формат OpenAI) или сам OpenAI."""

    def __init__(self, engine, api, model=None):
        self.engine, self.api = engine, api
        self.model = model or (OPENAI_DEFAULT_MODEL if engine == "openai" else DEFAULT_LLM_MODEL)
        if engine in ("anthropic", "gemini"):
            self.model = getattr(api, "model", engine)

    progress = None  # ставится из make_video: сообщения об ожидании лимита видны на экране

    def _wait_minute(self, why):
        if self.progress:
            self.progress("prompts", 0, 0, why)
        log(why)
        set_wait("llm", time.time() + 60)
        for _ in range(60):
            check_cancel()
            time.sleep(1)

    def chat_json(self, system, user, max_tokens=4000):
        check_cancel()
        if self.engine in ("anthropic", "gemini"):
            return self.api.chat_json(system, user, max_tokens=max_tokens)
        if self.engine == "openai":
            return self.api.chat_json(system + "\nОтвечай только JSON, без пояснений.", user, model=self.model, max_tokens=max_tokens)
        last = None
        attempt, limit_waits, limit = 0, 0, max_tokens
        while attempt < 4:
            check_cancel()
            try:
                r = self.api.s.post(BASE_URL + "/v1/chat/completions", json={
                    "model": self.model, "temperature": 0.7, "max_tokens": limit,
                    "messages": [{"role": "system", "content": system + "\nОтвечай только JSON, без пояснений."},
                                 {"role": "user", "content": user}],
                }, timeout=300)
                if r.status_code == 429 and limit_waits < 70:
                    # fast-gen: 200k токенов текста в час. На длинном ролике лимит кончается на середине —
                    # ждём по минуте, пока окно не освободится; попытка не сгорает.
                    limit_waits += 1
                    last = f"HTTP 429: {r.text[:200]}"
                    self._wait_minute("fast-gen: часовой лимит токенов для текстов исчерпан, жду минуту (продолжу автоматически)")
                    continue
                if r.status_code == 429 or r.status_code >= 500:
                    last = f"HTTP {r.status_code}: {r.text[:200]}"
                    attempt += 1
                    if attempt >= 2 and self.model != DEFAULT_LLM_FALLBACK and DEFAULT_LLM_FALLBACK:
                        log(f"модель {self.model} не отвечает ({last[:80]}), перехожу на {DEFAULT_LLM_FALLBACK}")
                        self.model = DEFAULT_LLM_FALLBACK
                    time.sleep(10 * attempt)
                    continue
                if r.status_code >= 400:
                    if self.model != DEFAULT_LLM_FALLBACK and DEFAULT_LLM_FALLBACK:
                        log(f"модель {self.model} недоступна ({r.status_code}), перехожу на {DEFAULT_LLM_FALLBACK}")
                        self.model = DEFAULT_LLM_FALLBACK
                        continue
                    raise RuntimeError(f"fast-gen chat {r.status_code}: {r.text[:300]}")
                choice = r.json()["choices"][0]
                if choice.get("finish_reason") == "length" and limit < 32000:
                    limit = min(32000, limit * 2)
                    log(f"ответ модели не влез в лимит, повторяю с {limit} токенами")
                    continue
                out = extract_json(choice["message"]["content"])
                clear_wait("llm")
                return out
            except (requests.RequestException, json.JSONDecodeError, KeyError) as e:
                last = str(e)
                attempt += 1
                if attempt >= 2 and self.model != DEFAULT_LLM_FALLBACK and DEFAULT_LLM_FALLBACK:
                    log(f"модель {self.model} отвечает некорректно ({last[:80]}), перехожу на {DEFAULT_LLM_FALLBACK}")
                    self.model = DEFAULT_LLM_FALLBACK
                time.sleep(5 * attempt)
        raise RuntimeError(f"Языковая модель не ответила корректно: {last}")


STYLE_SYSTEM = """Ты арт-директор видеоролика. По тексту озвучки напиши "библию" ролика — единый визуальный стиль,
персонажей, места и важные предметы, чтобы картинки от разных генераций выглядели как один фильм.
Заданный пользователем стиль (обязательно положи его в основу): {style_hint}
Ответ строго JSON:
{{
 "summary": "о чём ролик, 1-2 предложения (по-русски)",
 "style": "единый стиль на английском, 40-70 слов, начинающийся с заданного стиля: свет, объектив, палитра, время суток, настроение, текстуры. Без текста и надписей в кадре.",
 "characters": [
   {{"name": "имя или роль по-русски, как в тексте",
    "latin": "короткое имя латиницей без пробелов, например Barsik или Owner",
    "description": "ПОДРОБНОЕ описание на английском, 30-50 слов, которое будет вставляться в каждый промпт без изменений. ОБЯЗАТЕЛЬНО конкретные цвета: цвет шерсти/волос, цвет глаз, для людей — пол, возраст, причёска, борода/усы, и КОНКРЕТНАЯ одежда с цветами (например: dark green wool sweater, brown corduroy trousers, black rubber boots). Отметины, шрамы, возраст, телосложение. Никаких слов 'simple', 'casual', 'some' — только конкретика.",
    "anchors": "5-8 коротких визуальных якорей лица/морды через запятую, на английском, по которым героя узнают в любом кадре: форма лица, брови, нос, глаза, родинка/шрам, причёска, усы. Например: round face, thick grey eyebrows, hooked nose, pale blue eyes, white moustache, short silver hair"}}
 ],
 "locations": [
   {{"name": "место по-русски", "description": "постоянные детали места на английском, 15-30 слов, с цветами материалов"}}
 ],
 "props": [
   {{"name": "предмет по-русски, как в тексте", "latin": "короткое имя латиницей, например Watch",
    "description": "описание на английском, 10-25 слов, с цветами и материалами, чтобы предмет был одинаковым во всех кадрах",
    "owners": ["имя персонажа из characters, кто им пользуется"]}}
 ],
 "avoid": "чего избегать, на английском, коротко"
}}
В characters включи ВСЕХ повторяющихся персонажей (людей и животных), которые упомянуты в тексте. Не придумывай персонажей, которых в тексте нет.
Если в тексте один хозяин — это один конкретный человек, укажи его пол и внешность один раз и навсегда.
В props — только предметы, которые важны для истории и появляются больше одного раза (часы, письмо, скворечник, нож, машина). Не больше 6."""

SCENES_SYSTEM = """Ты режиссёр и оператор: пишешь раскадровку для генерации кадров видеоролика.
Тебе дана библия (стиль, персонажи, места, предметы) и список сцен (номер, длительность, текст озвучки).
Для КАЖДОЙ сцены опиши кадр. Главные правила:
1. КОНКРЕТИКА ФРАЗЫ ВАЖНЕЕ ВСЕГО. Найди в тексте сцены самую конкретную деталь — число, размер, сравнение, предмет,
   место, действие, явление — и сделай её центром кадра. «Рыба длиной 11 метров» — это не просто рыба, а рыба рядом
   с водолазом или лодкой, чтобы размер был виден. «Давление 1000 атмосфер» — смятый металлический предмет,
   «температура 2 градуса» — ледяная вода и иней. Цифры, названия, сравнения из текста не терять: показывай их наглядно.
2. ГЕРОЙ НЕ В КАЖДОМ КАДРЕ. Персонаж из библии попадает в кадр, только если сцена говорит именно о нём или он действует.
   Если сцена про место, явление, факт, историю, механизм, других людей — показывай их, без героя.
   Не ставь героя подряд больше двух сцен: чередуй кадры с ним и кадры без него (среда, детали, предметы, карты,
   приборы, руки, следы, результат действия).
3. ГРАММАТИКА КАМЕРЫ. У каждой сцены свой план (shot), угол (angle) и объектив (lens): 24 — общий/установочный,
   35 — общий повествовательный, 50 — средний, 85 — крупный, интимный. Два соседних кадра не могут иметь одинаковую
   пару план+объектив. Движение камеры (camera): static для диалогов и покоя, push-in для эмоционального открытия,
   pan для действия, track для движения героя; не двигай камеру в каждом кадре.
4. ПРАВИЛО 180 ГРАДУСОВ. Если в кадре два персонажа, задай им стороны (positions: кто слева, кто справа) и держи
   эти стороны во всех соседних сценах с той же парой, пока история не поменяла расстановку.
5. РЕКВИЗИТ. Если персонаж пользуется предметом из библии, перечисли предмет в props. Предмет, который герой держал
   в прошлой сцене, остаётся у него и в следующей, пока текст не сказал обратное.
6. Взгляд (gaze): куда смотрит главный персонаж кадра — на другого персонажа, на предмет или off-screen-left/right/up/down.
7. Если текст абстрактный — придумай уместную наглядную визуальную метафору, а не пустой пейзаж.
Поле "prompt" (50-90 слов, английский) описывает СОДЕРЖАНИЕ кадра: действие, объекты, среда, детали. Тип плана, объектив
и угол в него НЕ писать — они в отдельных полях и будут добавлены автоматически. Называй персонажей их латинскими
именами из библии (поле latin), например "LighthouseKeeper walks along the shore". В кадре только те персонажи,
которые есть в тексте этой сцены: НИКАКИХ дополнительных людей, животных, прохожих, семей, спутников. Место из библии —
его description. Стиль из библии кратко, своими словами.
Ответ строго JSON: {"scenes": [
 {"index": <номер>, "characters": ["имя из библии", ...], "location": "название места из библии или пусто",
  "props": ["название предмета из библии", ...], "shot": "wide|medium|close|detail|top|pov", "angle": "eye|low|high",
  "lens": 24|35|50|85, "camera": "static|push-in|pull-out|pan-left|pan-right|track", "light": "2-5 слов на английском",
  "time": "dawn|morning|day|sunset|night|indoor", "mood": "одно слово на английском",
  "gaze": "цель взгляда на английском", "positions": {"LatinName": "left|right"},
  "prompt": "<содержание кадра>", "motion": "<одно предложение на английском, как сцена движется в видео, без резких движений>"}
]} — ровно по одному элементу на каждую сцену."""

NO_TEXT = "Absolutely no text, letters, words, numbers, signs, logos, captions, subtitles or watermarks anywhere in the image."


def build_style(llm: LLM, text, job_dir, progress, style_key):
    out = os.path.join(job_dir, "style.json")
    cached = read_json(out)
    if cached and cached.get("style_key") == style_key:
        progress("style", 1, 1, "библия стиля уже есть")
        return cached
    progress("style", 0, 1, "LLM пишет библию стиля")
    hint = STYLES.get(style_key, STYLES[DEFAULT_STYLE])[1]
    style = llm.chat_json(STYLE_SYSTEM.format(style_hint=hint), "Текст озвучки:\n\n" + text[:12000], max_tokens=6000)
    style["style_key"] = style_key
    for i, c in enumerate(style.get("characters") or []):
        c.setdefault("latin", f"Char{i + 1}")
        c["latin"] = re.sub(r"[^A-Za-z]", "", c["latin"]) or f"Char{i + 1}"
    write_json(out, style)
    progress("style", 1, 1, "готово")
    return style


SHOT_WORDS = {"wide": "Wide shot", "medium": "Medium shot", "close": "Close-up", "detail": "Extreme close-up on a detail",
              "top": "Top-down view", "pov": "First-person point of view"}
ANGLE_WORDS = {"eye": "eye level", "low": "low angle", "high": "high angle"}
LENSES = (24, 35, 50, 85)
CAMERA_WORDS = {"static": "static camera", "push-in": "slow push-in", "pull-out": "slow pull-out", "pan-left": "slow pan left",
                "pan-right": "slow pan right", "track": "slow tracking shot"}
PROMPT_SCHEMA = 2  # менять при изменении полей раскадровки: старые scenes.json перепишутся


def _one(v):
    """Поле раскадровки к строке: список → первый элемент, словарь/None → пусто. Модель не всегда держит формат."""
    if isinstance(v, (list, tuple)):
        v = v[0] if v else ""
    if isinstance(v, dict) or v is None:
        return ""
    return str(v).strip()


def compose_prompt(prompt, names, chars, use_refs, scene=None, props=None, locs=None, anchors=None):
    """Финальный промпт кадра: план/угол/объектив → содержание → расстановка героев → предметы → место → свет/время/настроение
    → описания героев (и подсказка про референсы) → запрет текста."""
    scene, props, locs, anchors = scene or {}, props or {}, locs or {}, anchors or {}
    head = []
    if scene.get("shot") in SHOT_WORDS:
        head.append(SHOT_WORDS[scene["shot"]])
        if scene.get("angle") in ANGLE_WORDS and scene["shot"] not in ("top", "pov"):
            head.append(ANGLE_WORDS[scene["angle"]])
        if scene.get("lens") in LENSES:
            head.append(f"{scene['lens']}mm lens")
    p = (", ".join(head) + ". " if head else "") + prompt.rstrip()
    pos = scene.get("positions") or {}
    if len(pos) >= 2:
        p += " " + ", ".join(f"{n} on the {side}" for n, side in pos.items() if side in ("left", "right")) + " of the frame."
    gaze = _one(scene.get("gaze"))
    if gaze:
        gaze = (anchors.get("__latin__") or {}).get(gaze, gaze)
        if not re.search(r"[А-Яа-яЁё]", gaze):
            p += f" Gaze: {gaze}."
    pdesc = [props[n] for n in (scene.get("props") or []) if n in props]
    if pdesc:
        p += " Props (must look exactly like this): " + " ".join(pdesc)
    loc = _one(scene.get("location"))
    if loc in locs:
        p += " Setting: " + locs[loc]
    light, tod, mood = _one(scene.get("light")), _one(scene.get("time")), _one(scene.get("mood"))
    tail = [x for x in (light, None if tod in ("", "indoor") else tod, mood) if x]
    if tail:
        p += " Lighting and mood: " + ", ".join(str(x) for x in tail) + "."
    descs = [chars[n] + (f" Key features: {anchors[n]}." if anchors.get(n) else "") for n in names if n in chars]
    if descs:
        p += " Character reference (must match exactly): " + " ".join(descs)
        if use_refs:
            p += (" The attached reference image(s) show exactly how the character(s) look — keep the same face, colors, markings "
                  "and clothing. Use the reference ONLY for the character's appearance: the composition, pose, camera angle, "
                  "framing, background and lighting must follow this prompt, never copy the reference picture itself.")
        p += (" Everyone and everything named in this prompt is in the frame; do not add any extra people or animals "
              "that are not named here.")
    return p + " " + NO_TEXT


def direct_scenes(scenes, latin, owners=None):
    """Правки раскадровки кодом, потому что модель их соблюдает не всегда:
    - два соседних кадра не могут иметь одинаковые план+объектив;
    - ось 180°: та же пара героев в соседних сценах стоит по тем же сторонам;
    - предмет, который был у героя в прошлой сцене, переносится в следующую с тем же героем, если модель список не заполнила."""
    prev = None
    for s in scenes:
        for k in ("location", "shot", "angle", "camera", "light", "time", "mood", "gaze"):
            s[k] = _one(s.get(k))  # в кэше или ответе модели поле могло прийти списком
        chars_raw = s.get("characters")
        s["characters"] = [c for c in chars_raw if isinstance(c, str)] if isinstance(chars_raw, list) else []
        s["shot"] = s.get("shot") if s.get("shot") in SHOT_WORDS else "medium"
        s["angle"] = s.get("angle") if s.get("angle") in ANGLE_WORDS else "eye"
        try:
            s["lens"] = int(s.get("lens")) if int(s.get("lens")) in LENSES else 50
        except (TypeError, ValueError):
            s["lens"] = 50
        s["camera"] = s.get("camera") if s.get("camera") in CAMERA_WORDS else "static"
        pos = s.get("positions") if isinstance(s.get("positions"), dict) else {}
        s["positions"] = {k: v for k, v in pos.items() if v in ("left", "right")}
        s["props"] = [x for x in (s.get("props") if isinstance(s.get("props"), list) else []) if isinstance(x, str)]
        if prev is not None:
            if (s["shot"], s["lens"]) == (prev["shot"], prev["lens"]):
                order = ["wide", "medium", "close", "detail"]
                s["shot"] = order[(order.index(s["shot"]) + 1) % len(order)] if s["shot"] in order else "medium"
                s["lens"] = LENSES[(LENSES.index(s["lens"]) + 1) % len(LENSES)]
            same_pair = set(s.get("characters") or []) == set(prev.get("characters") or []) and len(s.get("characters") or []) >= 2
            if same_pair and prev["positions"]:
                s["positions"] = dict(prev["positions"])
            if not s["props"] and prev["props"]:
                carried = set(prev.get("characters") or []) & set(s.get("characters") or [])
                if carried:
                    s["props"] = [p for p in prev["props"] if not owners or not owners.get(p) or set(owners[p]) & carried]
        prev = s
    return scenes


def build_prompts(llm: LLM, style, scenes, job_dir, progress, use_refs, batch=25):
    """Промпты пишутся пачками и сохраняются после каждой: при сбое на середине готовое не пропадает,
    а при повторном запуске дописываются только недостающие. Переключение «скорость/качество» промпты не сбрасывает —
    описания героев и подсказка про референсы добавляются в compose_prompt без обращения к модели."""
    out = os.path.join(job_dir, "scenes.json")
    style_text = json.dumps({k: style.get(k, "") for k in ("summary", "style", "characters", "locations", "avoid")}, ensure_ascii=False)
    chars = {c["name"]: c["description"] for c in (style.get("characters") or []) if c.get("name") and c.get("description")}
    latin = {c["name"]: c.get("latin", "") for c in (style.get("characters") or []) if c.get("name")}
    anchors = {c["name"]: c["anchors"] for c in (style.get("characters") or []) if c.get("name") and c.get("anchors")}
    props = {p["name"]: p["description"] for p in (style.get("props") or []) if p.get("name") and p.get("description")}
    locs = {l["name"]: l["description"] for l in (style.get("locations") or []) if l.get("name") and l.get("description")}
    owners = {p["name"]: p.get("owners") or [] for p in (style.get("props") or []) if p.get("name")}
    # русские названия героев и предметов → латинские имена (для поля gaze)
    anchors["__latin__"] = {**{c["name"]: c.get("latin", "") for c in (style.get("characters") or []) if c.get("name") and c.get("latin")},
                            **{p["name"]: p.get("latin", "") for p in (style.get("props") or []) if p.get("name") and p.get("latin")}}
    sk = style.get("style_key")

    def detect(names, raw):
        """LLM мог забыть заполнить characters — добираем по латинским именам в промпте."""
        found = [n for n in (names if isinstance(names, list) else []) if isinstance(n, str) and n in chars]
        low = raw.lower()
        for n, l in latin.items():
            if l and len(l) >= 3 and l.lower() in low and n not in found:
                found.append(n)
        return found

    def finish(s):
        s["characters"] = detect(s.get("characters") or [], s.get("raw_prompt", ""))
        s["prompt"] = compose_prompt(s["raw_prompt"], s["characters"], chars, use_refs, scene=s, props=props, locs=locs, anchors=anchors)
        s["style_key"] = sk
        s["use_refs"] = use_refs
        s["schema"] = PROMPT_SCHEMA

    todo = [s for s in scenes if s.get("placeholder") or not (s.get("raw_prompt") and s.get("style_key") == sk and s.get("schema") == PROMPT_SCHEMA)]
    if not todo:
        direct_scenes(scenes, latin, owners)
        for s in scenes:
            finish(s)
        write_json(out, scenes)
        progress("prompts", len(scenes), len(scenes), "промпты сцен уже есть")
        return scenes

    chunks = [todo[b:b + batch] for b in range(0, len(todo), batch)]
    done_lock, done_n, ok_chunks = threading.Lock(), [len(scenes) - len(todo)], [0]
    progress("prompts", done_n[0], len(scenes), "LLM пишет промпты сцен" + (" (дописываю недостающие)" if done_n[0] else ""))

    def do_chunk(chunk):
        check_cancel()
        listing = "\n".join(f"{s['index']}. [{s['duration']:.1f} c] {s['text']}" for s in chunk)
        for s in chunk:
            s.pop("prompt", None)
            s.pop("raw_prompt", None)
        for attempt in range(3):
            try:
                resp = llm.chat_json(SCENES_SYSTEM, f"Библия стиля:\n{style_text}\n\nСцены:\n{listing}", max_tokens=520 * len(chunk) + 500)
            except Cancelled:
                raise
            except Exception as e:  # пачка не удалась — не роняем весь ролик, ниже подставим простые промпты
                log(f"промпты сцен {chunk[0]['index'] + 1}-{chunk[-1]['index'] + 1}: попытка {attempt + 1}/3 не удалась: {str(e)[:150]}")
                continue
            got = {int(x["index"]): x for x in resp.get("scenes", []) if x.get("prompt")}
            for s in chunk:
                if s["index"] in got:
                    g = got[s["index"]]
                    s["raw_prompt"] = g["prompt"].strip()
                    s.pop("placeholder", None)
                    s["characters"] = g.get("characters") or []
                    for k in ("location", "props", "shot", "angle", "lens", "camera", "light", "time", "mood", "gaze", "positions"):
                        s[k] = g.get(k)
                    for k in ("location", "shot", "angle", "camera", "light", "time", "mood", "gaze"):
                        s[k] = _one(s.get(k))  # модель иногда отдаёт список вместо строки: «unhashable type: 'list'» ронял весь ролик
                    s["motion"] = (_one(g.get("motion")) or CAMERA_WORDS.get(s.get("camera"), "slow gentle camera movement")).strip()
                    finish(s)
            if all(s.get("prompt") for s in chunk):
                ok_chunks[0] += 1
                break
        for s in chunk:
            if not s.get("prompt"):
                s["characters"] = []
                s["raw_prompt"] = f"{style.get('style', '')}. Wide shot illustrating: {s['text']}."
                s["motion"] = "slow gentle camera movement"
                s["placeholder"] = True  # модель не ответила: при следующем запуске эта сцена переспрашивается, а не остаётся навсегда
                finish(s)
        with done_lock:
            done_n[0] += len(chunk)
            write_json(out, scenes)  # сохраняем после каждой пачки
            progress("prompts", done_n[0], len(scenes), "LLM пишет промпты сцен")

    with cf.ThreadPoolExecutor(max_workers=3) as ex:  # три батча одновременно — в 3 раза быстрее на длинных роликах
        list(ex.map(do_chunk, chunks))
    direct_scenes(scenes, latin, owners)  # разнообразие планов, ось 180°, перенос реквизита — после всех пачек, по соседям
    for s in scenes:
        if s.get("raw_prompt"):
            finish(s)
    if chunks and not ok_chunks[0]:
        for s in todo:  # ни одна пачка не получилась — это не «плохие промпты», а неработающая модель: не сохраняем заглушки
            for k in ("prompt", "raw_prompt", "style_key"):
                s.pop(k, None)
        write_json(out, scenes)
        raise RuntimeError("Языковая модель не ответила ни на одну пачку сцен — проверьте ключ и лимит текстов fast-gen")
    write_json(out, scenes)
    progress("prompts", len(scenes), len(scenes), "готово")
    return scenes


# ============ шаг 4: лимиты и генераторы ============

class RateGate:
    """fast-gen: не больше N одновременных и не больше лимита кредитов в час.
    Сервер считает лимит скользящим окном, а в /usage часто отдаёт null — нашему счётчику верить нельзя.
    Поэтому после ответа «лимит исчерпан» все потоки останавливаются, через PROBE_WAIT секунд идёт ОДИН пробный запрос,
    и только когда он прошёл, остальные продолжают. Раньше десять потоков долбили сервер каждую минуту,
    сжигали попытки и сцены помечались «НЕ УДАЛОСЬ» (потом копировались из соседних — одинаковые кадры)."""
    PROBE_WAIT = 90

    def __init__(self, api: FastGen, kind="image"):
        self.api, self.kind = api, kind
        self.lock = threading.Lock()
        self.blocked_until = 0.0
        self.probe = None          # поток, которому разрешён пробный запрос
        self.after_block = False   # блокировка кончилась, пробы ещё не было
        self.said_at = 0.0         # чтобы десять потоков не писали одно и то же в журнал каждые 10 секунд
        # свой подсчёт кредитов — скользящее окно в час, как у сервера. Раньше счётчик копился с начала задания
        # и на длинном ролике «упирался в лимит» после 2000 кредитов, хотя часы давно сменились
        self.spent = collections.deque()
        self.refresh()
        self.sem = threading.Semaphore(self.threads)

    def refresh(self):
        u = self.api.usage()
        lim = u.get("account_limits", {})
        hourly = u.get("current_usage", {}).get("hourly_usage") or {}
        self.capabilities = u.get("capabilities") or {}
        if self.kind == "image":
            self.threads = max(1, min(10, int(lim.get("img_generation_threads_allowed") or 1)))
            self.hour_limit = int(lim.get("img_gen_per_hour_limit") or 0)
            used = hourly.get("image_generation") or 0
        else:
            self.threads = max(1, min(10, int(lim.get("video_generation_threads_allowed") or 1)))
            self.hour_limit = int(lim.get("video_gen_per_hour_limit") or 0)
            used = hourly.get("video_generation") or 0
        if isinstance(used, (int, float)) and used > 0:
            self.spent = collections.deque([(time.time(), int(used))])  # сервер сказал точно — верим ему
        self.checked_at = time.time()

    @property
    def used(self):
        now = time.time()
        while self.spent and now - self.spent[0][0] > 3600:
            self.spent.popleft()
        return max(0, sum(c for _, c in self.spent))

    def _say(self, progress, msg):
        now = time.time()
        if now - self.said_at > 45:
            self.said_at = now
            log(msg)
            progress("images" if self.kind == "image" else "videos", 0, 0, msg)

    def acquire(self, credits, progress):
        me = threading.current_thread()
        while True:
            check_cancel()
            with self.lock:
                now = time.time()
                if now >= self.blocked_until and self.probe in (None, me):
                    if self.after_block:
                        self.after_block = False
                        self.probe = me  # первый после паузы идёт один, остальные ждут его результата
                        return
                    if self.hour_limit == 0 or self.used + credits <= self.hour_limit:
                        self.spent.append((now, credits))
                        return
                waiting_server = now < self.blocked_until or self.probe is not None
            if waiting_server:
                self._say(progress, "fast-gen: часовой лимит кредитов исчерпан, жду, пока сервер освободит окно (продолжу автоматически)")
                set_wait("fastgen", self.blocked_until if now < self.blocked_until else None)
                for _ in range(10):
                    check_cancel()
                    time.sleep(1)
            else:
                self._wait_minute(progress, credits)

    def request_done(self, ok, credits):
        """Запрос завершился не ответом «лимит». Проба прошла — окно открыто, пускаем остальных."""
        with self.lock:
            if ok:
                clear_wait("fastgen")
            if self.probe is threading.current_thread():
                self.probe = None
                if ok:
                    self.spent = collections.deque([(time.time(), credits)])  # сервер снова принимает; точного остатка не знаем — следующий 429 поправит
            if not ok:
                self.spent.append((time.time(), -credits))  # кредиты не списались

    def release(self, credits):
        """Генерация не удалась — кредиты не списаны, возвращаем в счётчик."""
        self.request_done(False, credits)

    def _wait_minute(self, progress, credits=0):
        self._say(progress, f"fast-gen: по моему подсчёту лимит {self.hour_limit} кредитов/час почти выбран, жду минуту и сверяюсь с сервером (продолжу автоматически)")
        set_wait("fastgen", time.time() + 60)
        for _ in range(60):
            check_cancel()
            time.sleep(1)
        with self.lock:
            if time.time() - self.checked_at > 55:
                try:
                    self.refresh()  # сервер сам скажет, сколько осталось в текущем часе
                except Exception:
                    pass

    def server_limit_hit(self, progress):
        """Сервер ответил «лимит»: стоп всем на PROBE_WAIT секунд, потом один пробный запрос."""
        with self.lock:
            if self.hour_limit and self.used < self.hour_limit:
                self.spent.append((time.time(), self.hour_limit - self.used))
            self.blocked_until = max(self.blocked_until, time.time() + self.PROBE_WAIT)
            self.probe = None
            self.after_block = True


class NonStopGate:
    def __init__(self, api: NonStop):
        self.api = api
        self.lock = threading.Lock()
        info = api.account_info()
        self.threads = max(1, min(24, int(info.get("concurrent_tasks") or 4)))
        self.plan = info.get("plan")
        self.sem = threading.Semaphore(self.threads)
        self.exhausted = False
        self.refresh()

    def refresh(self):
        try:
            u = self.api.usage()
            rem = u.get("image_remaining")
            self.exhausted = rem is not None and int(rem) <= 0
        except Exception:
            pass

    def available(self):
        with self.lock:
            return not self.exhausted


def is_rate_limited(err_text):
    t = (err_text or "").lower()
    return ("429" in t or ("rate" in t and "limit" in t) or "quota" in t or "too many" in t or "slots full" in t
            or "limit_exceeded" in t or "hour_limit" in t or "per_hour" in t or "лимит" in t or "credits" in t and "exceed" in t)


LAST_RESORT_CHAIN = [("nano_banana_2_image_generate", 1), ("openai_image_generate", 1)]


def gen_fastgen_image(api, gate, scene, out_path, progress, refs, chain=None):
    """refs: список путей к референсам героев (может быть пустым). chain — принудительная цепочка моделей."""
    prompt = scene["prompt"]
    chain = chain or (IMAGE_CHAINS_REFS if refs else IMAGE_CHAINS)[FASTGEN_QUALITY]
    inputs = [{"filename": os.path.basename(p), "input": file_to_data_uri(p)} for p in refs]
    started = time.time()
    for op, tries in chain:
        t = 0
        while t < tries:
            check_cancel()
            credits = image_credits(op)
            gate.acquire(credits, progress)
            err, st = None, None
            with gate.sem:
                payload = {"operation": op, "prompt": prompt, "aspect_ratio": "16:9"}
                if HD_IMAGES and op in HD_OPS:
                    payload["generation_config"] = {"upscale": {"type": "2x"}}
                if inputs:
                    payload["inputs"] = inputs
                try:
                    st = api.run(payload, poll=3, max_wait=600)
                except Exception as e:
                    err = str(e)
                if st is not None:
                    if st.get("status") == "succeeded" and st.get("results"):
                        try:
                            api.download_result(st["results"][0], out_path + ".part")
                            os.replace(out_path + ".part", out_path)
                            gate.request_done(True, credits)
                            return "fastgen:" + op
                        except Exception as e:
                            err = f"не скачалась картинка: {e}"
                    else:
                        err = f"{st.get('error_code')} {str(st.get('error'))}"
            log(f"сцена {scene['index']}: fast-gen {op} попытка {t + 1}/{tries} не удалась: {err[:200]}")
            if is_rate_limited(err):
                gate.server_limit_hit(progress)
                if time.time() - started < MAX_LIMIT_WAIT:
                    continue  # ждём окно лимита, попытка не сгорает
            else:
                gate.request_done(False, credits)
            low = err.lower()
            if inputs and ("reference" in low or "invalid_argument" in low or "invalid_request" in low):
                inputs = []  # сервер не принял портреты героев — та же модель, но без них
                log(f"сцена {scene['index']}: повторяю без референсов")
                continue
            t += 1
            time.sleep(5)
    return None


def gen_nonstop_image(api, gate, scene, out_path, progress, refs):
    if not gate.available():
        log(f"сцена {scene['index']}: veononstop — суточный лимит картинок исчерпан, пропускаю")
        return None
    prompt = scene["prompt"]
    ref_objs = [{"name": os.path.splitext(os.path.basename(p))[0], "image_base64": file_to_data_uri(p).split(",", 1)[1],
                 "mime_type": "image/png"} for p in refs]
    for model_key, tries in NONSTOP_CHAINS[FASTGEN_QUALITY]:
        for t in range(tries):
            check_cancel()
            with gate.sem:
                try:
                    api.generate_image(prompt, out_path + ".part", model_key=model_key, aspect_ratio="16:9", max_wait=1500,
                                       reference_images=ref_objs or None, use_all_ref_images=bool(ref_objs))
                    os.replace(out_path + ".part", out_path)
                    return "nonstop:" + NONSTOP_MODELS.get(model_key, model_key)
                except Exception as e:
                    msg = str(e)
                    log(f"сцена {scene['index']}: veononstop {NONSTOP_MODELS.get(model_key, model_key)} попытка {t + 1}/{tries} не удалась: {msg[:200]}")
                    if "401" in msg:
                        return None
                    if is_rate_limited(msg):
                        time.sleep(30)
                    if "limit" in msg.lower() and "daily" in msg.lower():
                        gate.refresh()
                        return None
    return None


class YouGenGate:
    """yougen: N одновременных задач и дневная квота картинок/видео."""

    def __init__(self, api: YouGen):
        self.api = api
        self.lock = threading.Lock()
        self.threads = 4
        self.exhausted = False
        self.usage = {}
        self.refresh()
        self.sem = threading.Semaphore(self.threads)

    def refresh(self):
        try:
            u = self.api.usage()
            self.usage = u
            for k in ("concurrency", "max_concurrent", "concurrent", "image_concurrent", "threads"):
                v = u.get(k)
                if isinstance(v, dict):
                    v = v.get("image") or v.get("max")
                if isinstance(v, (int, float)) and v > 0:
                    self.threads = max(1, min(16, int(v)))
                    break
            img = u.get("image") if isinstance(u.get("image"), dict) else None
            rem = (img or {}).get("remaining", u.get("image_remaining"))
            self.exhausted = rem is not None and int(rem) <= 0
        except Exception as e:
            log(f"yougen: не удалось прочитать лимиты: {e}")

    def available(self):
        with self.lock:
            return not self.exhausted


def gen_yougen_image(api, gate, scene, out_path, progress, refs):
    if not gate.available():
        log(f"сцена {scene['index']}: yougen — дневная квота картинок исчерпана, пропускаю")
        return None
    prompt = scene["prompt"]
    inputs = [file_to_data_uri(p) for p in refs] or None
    for model, tries in YOUGEN_CHAINS[FASTGEN_QUALITY]:
        for t in range(tries):
            check_cancel()
            with gate.sem:
                try:
                    api.generate_image(prompt, out_path + ".part", model=model, aspect_ratio="16:9", inputs=inputs, max_wait=900)
                    os.replace(out_path + ".part", out_path)
                    return "yougen:" + YOUGEN_MODELS.get(model, model)
                except Exception as e:
                    msg = str(e)
                    log(f"сцена {scene['index']}: yougen {YOUGEN_MODELS.get(model, model)} попытка {t + 1}/{tries} не удалась: {msg[:200]}")
                    if msg.startswith("401") or msg.startswith("403"):
                        return None
                    if msg.startswith("429"):
                        gate.refresh()
                        with gate.lock:
                            gate.exhausted = True
                        return None
                    time.sleep(5)
    return None


def gen_yougen_video(api, gate, scene, img_path, out_path, progress):
    prompt = f"{scene.get('motion', 'slow gentle camera movement')}. {scene.get('raw_prompt', '')} {NO_TEXT}"
    for t in range(2):
        check_cancel()
        with gate.sem:
            try:
                api.generate_video_from_image(prompt, img_path, out_path + ".part.mp4", model="veo-3.1-fast", aspect_ratio="16:9", max_wait=1800)
                os.replace(out_path + ".part.mp4", out_path)
                return "yougen:veo-3.1-fast"
            except Exception as e:
                msg = str(e)
                log(f"сцена {scene['index']}: yougen видео попытка {t + 1}/2: {msg[:200]}")
                if msg[:3] in ("401", "403", "429"):
                    return None
                time.sleep(5)
    return None


class RoyalGate:
    """RoyalTechno: не больше recommended_max_in_flight задач одновременно."""

    def __init__(self, api: RoyalTechno):
        self.api = api
        self.lock = threading.Lock()
        a = api.account()
        lim = a.get("limits") or {}
        self.threads = max(1, min(20, int(lim.get("recommended_max_in_flight") or 4)))
        self.balance = a.get("balance_usd", "")
        self.sem = threading.Semaphore(self.threads)
        self.exhausted = False

    def available(self):
        with self.lock:
            return not self.exhausted


def gen_royal_image(api, gate, scene, out_path, progress, refs):
    if not gate.available():
        log(f"сцена {scene['index']}: royaltechno — баланс или квота исчерпаны, пропускаю")
        return None
    prompt = scene["prompt"]
    for model, tries in ROYAL_CHAINS[FASTGEN_QUALITY]:
        for t in range(tries):
            check_cancel()
            with gate.sem:
                try:
                    api.generate_image(prompt, out_path + ".part", model=model, reference_paths=refs or None, max_wait=900)
                    os.replace(out_path + ".part", out_path)
                    return "royal:" + ROYAL_MODELS.get(model, model)
                except RoyalError as e:
                    log(f"сцена {scene['index']}: royaltechno {ROYAL_MODELS.get(model, model)} попытка {t + 1}/{tries}: {e}")
                    if e.status in (401, 403):
                        return None
                    if e.status == 402 or e.code in ("insufficient_credits", "daily_limit_reached"):
                        with gate.lock:
                            gate.exhausted = True
                        return None
                    if e.status == 400:
                        break  # с этой моделью запрос не проходит — пробуем следующую
                    time.sleep(5)
                except Exception as e:
                    log(f"сцена {scene['index']}: royaltechno ошибка: {str(e)[:200]}")
                    time.sleep(5)
    return None


def gen_royal_video(api, gate, scene, img_path, out_path, progress):
    prompt = f"{scene.get('motion', 'slow gentle camera movement')}. {scene.get('raw_prompt', '')} {NO_TEXT}"
    for t in range(2):
        check_cancel()
        with gate.sem:
            try:
                api.generate_video_from_image(prompt, img_path, out_path + ".part.mp4", max_wait=2400)
                os.replace(out_path + ".part.mp4", out_path)
                return "royal:veo-3.1"
            except RoyalError as e:
                log(f"сцена {scene['index']}: royaltechno видео попытка {t + 1}/2: {e}")
                if e.status in (400, 401, 402, 403):
                    return None
                time.sleep(10)
            except Exception as e:
                log(f"сцена {scene['index']}: royaltechno видео ошибка: {str(e)[:200]}")
                time.sleep(10)
    return None


class GoogleGate:
    """Google Gemini API: лимиты зависят от тарифа; держим 4 картинки и 2 видео одновременно, на 429 ждём."""

    def __init__(self, api):
        self.api = api
        self.lock = threading.Lock()
        self.threads = 4
        self.sem = threading.Semaphore(self.threads)
        self.vsem = threading.Semaphore(2)
        self.exhausted = False
        api.models()  # проверка ключа

    def available(self):
        with self.lock:
            return not self.exhausted


def gen_google_image(api, gate, scene, out_path, progress, refs):
    if not gate.available():
        log(f"сцена {scene['index']}: Google — ключ отклонён или квота исчерпана, пропускаю")
        return None
    chain = (GOOGLE_CHAINS_REFS if refs else GOOGLE_CHAINS)[FASTGEN_QUALITY]
    for kind, tries in chain:
        for t in range(tries):
            check_cancel()
            with gate.sem:
                try:
                    model = api.generate_image(scene["prompt"], out_path + ".part", kind=kind, reference_paths=refs or None)
                    os.replace(out_path + ".part", out_path)
                    return "google:" + model
                except GoogleError as e:
                    log(f"сцена {scene['index']}: Google {kind} попытка {t + 1}/{tries}: {e}")
                    if e.status in (401, 403):
                        with gate.lock:
                            gate.exhausted = True
                        return None
                    if e.status in (400, 404, 422):
                        break  # эта модель не подходит — следующая
                    time.sleep(5)
                except Exception as e:
                    log(f"сцена {scene['index']}: Google ошибка: {str(e)[:200]}")
                    time.sleep(5)
    return None


def gen_google_video(api, gate, scene, img_path, out_path, progress):
    prompt = f"{scene.get('motion', 'slow gentle camera movement')}. {scene.get('raw_prompt', '')} {NO_TEXT}"
    for t in range(2):
        check_cancel()
        with gate.vsem:
            try:
                model = api.generate_video_from_image(prompt, img_path, out_path + ".part.mp4", max_wait=1800)
                os.replace(out_path + ".part.mp4", out_path)
                return "google:" + model
            except GoogleError as e:
                log(f"сцена {scene['index']}: Google видео попытка {t + 1}/2: {e}")
                if e.status in (400, 401, 403, 404, 422):
                    return None
                time.sleep(15)
            except Exception as e:
                log(f"сцена {scene['index']}: Google видео ошибка: {str(e)[:200]}")
                time.sleep(15)
    return None


class SliderGate:
    def __init__(self, api: SecretSlider):
        self.api = api
        self.lock = threading.Lock()
        self.exhausted = False
        self.threads = 4
        self.credits = None
        try:
            b = api.balance()
            self.credits = b.get("api_credits")
            self.exhausted = self.credits is not None and int(self.credits) <= 0
            self.threads = max(1, min(8, int(b.get("rate_limit_per_minute") or 8) // 2))
        except Exception as e:
            log(f"secretslider: не удалось прочитать баланс: {e}")
        self.sem = threading.Semaphore(self.threads)

    def available(self):
        with self.lock:
            return not self.exhausted


def gen_slider_image(api, gate, scene, out_path, progress, refs):
    """Поштучно слайдер не используем (одна активная задача на ключ) — только пакетом, см. slider_batch."""
    return None


def slider_batch(ctx, scenes, img_dir, progress):
    """Сцены слайдера уходят пакетами (до 100 промптов); если ключей несколько — по пакету на каждый ключ параллельно.
    Возвращает множество индексов сцен, которые удались."""
    units = [(a, g) for a, g in ctx.get("sliders", []) if g.available()]
    if not units or not scenes:
        return set()
    done, lock = set(), threading.Lock()

    def run(api, gate, part):
        for k in range(0, len(part), 100):
            chunk = part[k:k + 100]
            check_cancel()
            paths = [os.path.join(img_dir, f"{s['index']:04d}.png") for s in chunk]
            progress("images", 0, 0, f"secretslider: отправляю пакет из {len(chunk)} сцен")
            try:
                got = api.generate_batch([s["prompt"] for s in chunk], [p + ".part" for p in paths],
                                         progress=lambda m: progress("images", 0, 0, m), log=log)
            except SliderError as e:
                log(f"secretslider пакет: {e}")
                if e.status == 402:
                    with gate.lock:
                        gate.exhausted = True
                return
            except Exception as e:
                log(f"secretslider пакет: {str(e)[:200]}")
                return
            for s, p, g in zip(chunk, paths, got):
                if g:
                    os.replace(g, p)
                    with lock:
                        done.add(s["index"])

    parts = [scenes[n::len(units)] for n in range(len(units))]
    with cf.ThreadPoolExecutor(max_workers=len(units)) as ex:
        list(ex.map(lambda a: run(a[0][0], a[0][1], a[1]), zip(units, parts)))
    return done

def make_references(ctx, style, job_dir, progress):
    """Один портрет на каждого героя. Возвращает {имя: путь}."""
    chars = style.get("characters") or []
    if not chars:
        return {}
    ref_dir = os.path.join(job_dir, "refs")
    os.makedirs(ref_dir, exist_ok=True)
    refs = {}
    for i, c in enumerate(chars):
        check_cancel()
        path = os.path.join(ref_dir, f"{c.get('latin') or 'Char%d' % (i + 1)}.png")
        if os.path.exists(path):
            refs[c["name"]] = path
            continue
        progress("refs", i, len(chars), f"рисую референс: {c['name']}")
        prompt = (f"Character reference sheet, single subject, full body and face clearly visible, neutral background, "
                  f"soft even lighting. {style.get('style', '')}. {c['description']} Only this character, nothing else. {NO_TEXT}")
        scene = {"index": f"ref-{i}", "prompt": prompt}
        model = None
        for prov in ctx["providers"]:
            model = ctx["image_gen"][prov](scene, path, progress, [])
            if model:
                break
        if model:
            refs[c["name"]] = path
        else:
            log(f"референс для {c['name']} не получился, герой пойдёт без референса")
    progress("refs", len(chars), len(chars), "референсы готовы")
    return refs


# ---- картинки всех сцен ----

def provider_chain(ctx, index):
    """Сцена i идёт в сервис номер i (по кругу), при сбое — в следующие по списку,
    а затем в любой другой сервис, для которого сохранён ключ."""
    provs = ctx["providers"]
    k = index % len(provs)
    return provs[k:] + provs[:k] + [p for p in ctx.get("fallback", []) if p not in provs]


class Prerender:
    """Кадры с движением камеры рендерятся, пока ещё рисуются остальные картинки: этап «сборка» почти исчезает."""

    def __init__(self, scenes, img_dir, job_dir, mode, motion, video_first=0):
        self.pool = cf.ThreadPoolExecutor(max_workers=max(1, min(3, (os.cpu_count() or 2) // 2)))
        self.img_dir = img_dir
        self.clips_dir = os.path.join(job_dir, "clips" + ("_m" if motion else ""))
        os.makedirs(self.clips_dir, exist_ok=True)
        self.extra = TRANSITION if motion else 0.0
        self.skip = set()  # сцены, которые будут оживляться видео — их клип делается позже
        self.skip = {s["index"] for s in animated_scenes(scenes, mode, video_first)}
        self.futs = []

    def submit(self, s):
        if s["index"] in self.skip:
            return
        img = os.path.join(self.img_dir, f"{s['index']:04d}.png")
        clip = os.path.join(self.clips_dir, f"{s['index']:04d}.mp4")
        self.futs.append(self.pool.submit(render_scene_clip, img, s["index"], s["duration"] + self.extra, clip))

    def wait(self):
        for f in self.futs:
            try:
                f.result()
            except Exception as e:  # клип дорисует сборка
                log(f"предварительный рендер: {str(e)[:120]}")
        self.pool.shutdown(wait=True)


def drop_failed_images(scenes, job_dir):
    """Сцены, которые в прошлый раз подменили копией соседнего кадра, рисуем заново: убираем их png и запись о неудаче."""
    img_dir = os.path.join(job_dir, "images")
    state_path = os.path.join(job_dir, "images.json")
    state = read_json(state_path, {})
    redo = 0
    for sc in scenes:
        st = state.get(str(sc["index"])) or {}
        pth = os.path.join(img_dir, f"{sc['index']:04d}.png")
        if st and not st.get("ok"):
            try:
                if os.path.exists(pth):
                    os.remove(pth)
                state.pop(str(sc["index"]), None)
                redo += 1
            except OSError:
                pass
    if redo:
        write_json(state_path, state)
        log(f"{redo} сцен были копиями соседних кадров — рисую их заново")


class VideoOverlap:
    """Оживление стартует вместе с картинками: сцена уходит в видео, как только её картинка готова,
    а не после всех картинок. Пока идут картинки, сообщения оживления пишутся только в журнал."""

    def __init__(self, ctx, scenes, job_dir, progress, mode, video_first):
        self.quiet = threading.Event()
        self.quiet.set()
        self.stop = threading.Event()
        img_dir = os.path.join(job_dir, "images")
        state_path = os.path.join(job_dir, "images.json")

        def ready(s):
            if self.stop.is_set():
                return None
            if os.path.exists(os.path.join(img_dir, f"{s['index']:04d}.png")):
                return True
            st = read_json(state_path, {}).get(str(s["index"])) or {}
            return None if st and not st.get("ok") else False

        self.pool = cf.ThreadPoolExecutor(max_workers=1)
        self.fut = self.pool.submit(generate_all_videos, ctx, scenes, img_dir, job_dir, progress, mode, video_first,
                                    image_ready=ready, quiet=self.quiet)

    def abort(self):
        self.stop.set()
        self.quiet.clear()

    def result(self):
        self.quiet.clear()
        try:
            return self.fut.result()
        finally:
            self.pool.shutdown(wait=True)


def warn_hours(ctx, todo, progress):
    """Длинный ролик на тарифе fast-gen: честно говорим, сколько часов уйдёт из-за лимита кредитов в час."""
    try:
        units = [u for u in ctx["providers"] if base_of(u) == "fastgen"]
        if not units or not todo:
            return
        per_scene = image_credits(IMAGE_CHAINS[FASTGEN_QUALITY][0][0])
        mine = sum(1 for s in todo if base_of(provider_chain(ctx, s["index"])[0]) == "fastgen")
        limit = sum(ctx["gates"][u].hour_limit for u in units)
        need = mine * per_scene
        if limit and need > limit:
            hours = need / limit
            msg = (f"внимание: {mine} сцен × {per_scene} кредита = {need} кредитов, а лимит fast-gen {limit} в час — "
                   f"картинки займут около {hours:.1f} ч, программа будет ждать лимит автоматически"
                   + (" (в режиме «скорость» было бы в 4 раза быстрее)" if per_scene > 1 else ""))
            log(msg)
            progress("images", 0, 0, msg)
    except Exception:
        pass


def generate_all_images(ctx, scenes, style, job_dir, progress, refs, on_image=None):
    img_dir = os.path.join(job_dir, "images")
    os.makedirs(img_dir, exist_ok=True)
    state_path = os.path.join(job_dir, "images.json")
    state = read_json(state_path, {})
    workers = sum(ctx["gates"][p].threads for p in ctx["providers"])
    # сцены, которые в прошлый раз не удались и были подменены копией соседнего кадра, при повторном запуске рисуем заново
    redo = 0
    for sc in scenes:
        st = state.get(str(sc["index"])) or {}
        pth = os.path.join(img_dir, f"{sc['index']:04d}.png")
        if st and not st.get("ok") and os.path.exists(pth):
            try:
                os.remove(pth)
                redo += 1
            except OSError:
                pass
    if redo:
        log(f"{redo} сцен были копиями соседних кадров — рисую их заново")
    todo = [s for s in scenes if not os.path.exists(os.path.join(img_dir, f"{s['index']:04d}.png"))]
    done_count = len(scenes) - len(todo)
    names = " + ".join(f"{unit_name(p)} ({ctx['gates'][p].threads})" for p in ctx["providers"])
    progress("images", done_count, len(scenes), f"генерирую картинки: {names}")
    warn_hours(ctx, todo, progress)
    lock = threading.Lock()
    # Secret Slider: свои сцены (по кругу) — одним пакетом, до начала остальных
    if "slider" in ctx["bases"]:
        mine = [s for s in todo if base_of(provider_chain(ctx, s["index"])[0]) == "slider"] if len(ctx["bases"]) > 1 else list(todo)
        ok = slider_batch(ctx, mine, img_dir, progress)
        for s in mine:
            if s["index"] in ok:
                state[str(s["index"])] = {"ok": True, "model": "slider:batch"}
                done_count += 1
        write_json(state_path, state)
        progress("images", done_count, len(scenes), f"secretslider: готово {len(ok)} из {len(mine)}")
        todo = [s for s in todo if s["index"] not in ok]

    def work(s):
        nonlocal done_count
        if CANCEL.is_set():
            return
        path = os.path.join(img_dir, f"{s['index']:04d}.png")
        scene_refs = [refs[n] for n in s.get("characters", []) if n in refs]
        model = None
        try:
            for prov in provider_chain(ctx, s["index"]):
                if prov not in ctx["providers"]:
                    log(f"сцена {s['index']}: выбранные сервисы не справились, пробую {unit_name(prov)}")
                try:
                    model = ctx["image_gen"][prov](s, path, progress, scene_refs)
                except Cancelled:
                    raise
                except Exception as e:
                    log(f"сцена {s['index']}: {prov} упал: {str(e)[:200]}")
                    model = None
                if model:
                    break
            if not model and ctx.get("api") and ctx["gates"].get("fastgen"):
                # последний рубеж: любая другая модель fast-gen, лишь бы сцена сделалась
                tried = set(m for m, _ in (IMAGE_CHAINS_REFS if scene_refs else IMAGE_CHAINS)[FASTGEN_QUALITY])
                rest = [(m, t) for m, t in LAST_RESORT_CHAIN if m not in tried]
                if rest:
                    log(f"сцена {s['index']}: последний рубеж fast-gen: {', '.join(m for m, _ in rest)}")
                    try:
                        model = gen_fastgen_image(ctx["api"], ctx["gates"]["fastgen"], s, path, progress, scene_refs, chain=rest)
                    except Cancelled:
                        raise
                    except Exception as e:
                        log(f"сцена {s['index']}: последний рубеж упал: {str(e)[:200]}")
        except Cancelled:
            return
        with lock:
            state[str(s["index"])] = {"ok": bool(model), "model": model}
            write_json(state_path, state)
            done_count += 1
            progress("images", done_count, len(scenes), f"сцена {s['index'] + 1}: {'OK ' + model if model else 'НЕ УДАЛОСЬ'}")
        if model and on_image:
            try:
                on_image(s)
            except Exception:
                pass

    with cf.ThreadPoolExecutor(max_workers=max(1, workers)) as ex:
        list(ex.map(work, todo))
    check_cancel()
    failed = [s for s in todo if not os.path.exists(os.path.join(img_dir, f"{s['index']:04d}.png"))]
    if failed:
        # второй заход: к этому времени лимиты обычно отпустили, а копия соседнего кадра — худший вариант
        log(f"повторяю {len(failed)} сцен, которые не удались с первого раза")
        done_count -= len(failed)
        progress("images", done_count, len(scenes), f"повторяю {len(failed)} неудавшихся сцен")
        with cf.ThreadPoolExecutor(max_workers=max(1, workers)) as ex:
            list(ex.map(work, failed))
        check_cancel()

    missing = [s for s in scenes if not os.path.exists(os.path.join(img_dir, f"{s['index']:04d}.png"))]
    if len(missing) < len(scenes) and len(missing) > max(MAX_COPIES_MIN, int(len(scenes) * MAX_COPIES_SHARE)):
        # пара копий соседних кадров незаметна, а сотня одинаковых картинок — брак: честнее остановиться
        write_json(state_path, state)
        have = len(scenes) - len(missing)
        msg = (f"Нарисовано {have} из {len(scenes)} картинок — сервис перестал их отдавать (обычно это суточный или часовой лимит ключа). "
               f"Всё готовое сохранено. Запустите это же видео ещё раз позже или добавьте ключ другого сервиса — "
               f"программа продолжит с того же места и дорисует только недостающие {len(missing)}.")
        log(msg)
        raise SystemExit(msg)

    last_good = None
    for s in scenes:
        p = os.path.join(img_dir, f"{s['index']:04d}.png")
        if os.path.exists(p):
            last_good = p
        elif last_good:
            shutil.copyfile(last_good, p)
            state[str(s["index"])] = {"ok": False, "model": "copy_prev"}
    for s in reversed(scenes):
        p = os.path.join(img_dir, f"{s['index']:04d}.png")
        if os.path.exists(p):
            last_good = p
        elif last_good:
            shutil.copyfile(last_good, p)
    write_json(state_path, state)
    if any(not os.path.exists(os.path.join(img_dir, f"{s['index']:04d}.png")) for s in scenes):
        raise RuntimeError("Не удалось получить ни одной картинки — проверьте ключи и лимиты")
    return img_dir


# ============ шаг 4б: оживление картинок в видео ============

def gen_fastgen_video(api, gate, scene, img_path, out_path, progress):
    """Часовой лимит видео (Video Lite — 15 клипов) раньше сжигал попытки: после 15 клипов все остальные сцены за секунды
    помечались «не оживилась». Теперь, как и у картинок: сервер сказал «лимит» → ждём окно, попытка не сгорает."""
    prompt = f"{scene.get('motion', 'slow gentle camera movement')}. {scene.get('raw_prompt', '')} {NO_TEXT}"
    started = time.time()
    for op, tries in VIDEO_CHAIN_FASTGEN:
        t = 0
        while t < tries:
            check_cancel()
            credits = VIDEO_CREDITS.get(op, 1)
            gate.acquire(credits, progress)
            err, st = None, None
            with gate.sem:
                payload = {"operation": op, "prompt": prompt, "aspect_ratio": "16:9", "inputs": [file_to_data_uri(img_path)]}
                if "keyframes" in op:
                    payload["keyframes"] = True
                try:
                    st = api.run(payload, poll=5, max_wait=1500)
                except Exception as e:
                    err = str(e)
                    if "403" in err or "video.generate" in err:
                        gate.request_done(False, credits)
                        log(f"сцена {scene['index']}: fast-gen видео недоступно на этом ключе: {err[:160]}")
                        return None
                if st is not None:
                    if st.get("status") == "succeeded" and st.get("results"):
                        try:
                            api.download_result(st["results"][0], out_path + ".part.mp4")
                            os.replace(out_path + ".part.mp4", out_path)
                            gate.request_done(True, credits)
                            return "fastgen:" + op
                        except Exception as e:
                            err = f"не скачалось видео: {e}"
                    else:
                        err = f"{st.get('error_code')} {str(st.get('error'))}"
            log(f"сцена {scene['index']}: fast-gen видео {op} попытка {t + 1}/{tries}: {err[:200]}")
            if is_rate_limited(err):
                gate.server_limit_hit(progress)
                if time.time() - started < MAX_LIMIT_WAIT:
                    continue  # ждём окно лимита, попытка не сгорает
            else:
                gate.request_done(False, credits)
            t += 1
            time.sleep(5)
    return None


def gen_nonstop_video(api, gate, scene, img_path, out_path, progress):
    prompt = f"{scene.get('motion', 'slow gentle camera movement')}. {scene.get('raw_prompt', '')} {NO_TEXT}"
    for t in range(2):
        check_cancel()
        with gate.sem:
            try:
                api.generate_video_from_image(prompt, img_path, out_path + ".part.mp4", aspect_ratio="16:9", max_wait=1800)
                os.replace(out_path + ".part.mp4", out_path)
                return "nonstop:veo"
            except Exception as e:
                msg = str(e)
                log(f"сцена {scene['index']}: veononstop видео попытка {t + 1}/2: {msg[:200]}")
                if "401" in msg:
                    return None
                if is_rate_limited(msg):
                    time.sleep(30)
    return None


def animated_scenes(scenes, mode, video_first=0):
    """Какие сцены оживляются: «только видео» — все; иначе первые video_first сцен, а в «50 на 50» ещё и каждая вторая."""
    if mode == "video":
        return list(scenes)
    return [s for s in scenes if s["index"] < int(video_first or 0) or (mode == "mixed" and s["index"] % 2 == 0)]


def generate_all_videos(ctx, scenes, img_dir, job_dir, progress, mode="video", video_first=0, image_ready=None, quiet=None):
    """Оживляем сцены из animated_scenes(). Возвращает {index: mp4}.
    image_ready(s) → True (картинка готова) / False (ещё нет) / None (не будет); quiet — пока взведён, сообщения только в журнал."""
    def say(*a):
        if quiet is not None and quiet.is_set():
            if len(a) > 3 and a[3]:
                log(a[3])
            return
        return progress(*a)

    total_scenes = len(scenes)
    scenes = animated_scenes(scenes, mode, video_first)
    if not scenes:
        return {}
    why = {"video": "режим «Только видео» — все сцены",
           "mixed": "режим «50 на 50» — каждая вторая" + (f" плюс первые {int(video_first)}" if video_first else "")}.get(
        mode, f"первые {int(video_first)} сцен")
    msg = f"оживляю {len(scenes)} из {total_scenes} сцен: {why}"
    log(msg)
    say("videos", 0, len(scenes), msg)
    vid_dir = os.path.join(job_dir, "videos")
    os.makedirs(vid_dir, exist_ok=True)
    state_path = os.path.join(job_dir, "videos.json")
    state = read_json(state_path, {})
    video_gen = {}
    if "fastgen" in ctx["bases"]:
        try:
            g = RateGate(ctx["api"], kind="video")
            if g.capabilities.get("video.generate", True):
                video_gen["fastgen"] = (g, lambda s, img, out, pr: gen_fastgen_video(ctx["api"], g, s, img, out, pr))
                need = sum(1 for s in scenes if not os.path.exists(os.path.join(vid_dir, f"{s['index']:04d}.mp4")))
                if g.hour_limit and need > g.hour_limit:
                    msg = (f"внимание: {need} клипов для оживления, а лимит fast-gen {g.hour_limit} видео в час — "
                           f"это около {need / g.hour_limit:.1f} ч, программа будет ждать лимит автоматически. Чтобы не ждать: "
                           f"«Стоп», затем режим «Только картинки» с ползунком «Оживить первые» — готовые картинки и клипы сохранятся")
                    log(msg)
                    say("videos", 0, 0, msg)
            else:
                log("fast-gen: на этом ключе видео недоступно (video.generate=false)")
        except Exception as e:
            log(f"fast-gen видео: не удалось прочитать лимиты: {e}")
    if "nonstop" in ctx["bases"]:
        g = ctx["gates"]["nonstop"]
        video_gen["nonstop"] = (g, lambda s, img, out, pr: gen_nonstop_video(ctx["nonstop"], g, s, img, out, pr))
    if "yougen" in ctx["bases"]:
        g = ctx["gates"]["yougen"]
        video_gen["yougen"] = (g, lambda s, img, out, pr: gen_yougen_video(ctx["yougen"], g, s, img, out, pr))
    if "royal" in ctx["bases"]:
        g = ctx["gates"]["royal"]
        video_gen["royal"] = (g, lambda s, img, out, pr: gen_royal_video(ctx["royal"], g, s, img, out, pr))
    if "google" in ctx["bases"]:
        g = ctx["gates"]["google"]
        video_gen["google"] = (g, lambda s, img, out, pr: gen_google_video(ctx["google"], g, s, img, out, pr))
    provs = [p for p in ctx["bases"] if p in video_gen]
    workers = sum(video_gen[p][0].threads for p in provs)
    if not provs:
        say("videos", 0, 0, "оживление недоступно на выбранных ключах — кадры останутся с плавным движением")
        return {}
    # не оживившиеся в прошлый раз сцены при повторном запуске пробуем снова
    todo = [s for s in scenes if not os.path.exists(os.path.join(vid_dir, f"{s['index']:04d}.mp4"))]
    done_count = len(scenes) - len(todo)
    say("videos", done_count, len(scenes), f"оживляю картинки ({workers} потоков, это самый долгий этап)")
    lock = threading.Lock()

    def work(s):
        nonlocal done_count
        if CANCEL.is_set():
            return
        img = os.path.join(img_dir, f"{s['index']:04d}.png")
        out = os.path.join(vid_dir, f"{s['index']:04d}.mp4")
        if image_ready is not None:
            while True:  # оживление идёт параллельно с картинками: ждём свою картинку
                r = image_ready(s)
                if r is True:
                    break
                if r is None or CANCEL.is_set():
                    return
                time.sleep(2)
        k = s["index"] % len(provs)
        model = None
        try:
            for prov in provs[k:] + provs[:k]:
                model = video_gen[prov][1](s, img, out, say)
                if model:
                    break
        except Cancelled:
            return
        with lock:
            state[str(s["index"])] = {"ok": bool(model), "model": model}
            write_json(state_path, state)
            done_count += 1
            say("videos", done_count, len(scenes), f"сцена {s['index'] + 1}: {'OK ' + model if model else 'не оживилась, останется картинка с движением'}")

    with cf.ThreadPoolExecutor(max_workers=max(1, workers)) as ex:
        list(ex.map(work, todo))
    check_cancel()
    made = sum(1 for s in scenes if os.path.exists(os.path.join(vid_dir, f"{s['index']:04d}.mp4")))
    if made < len(scenes):
        msg = (f"оживилось {made} из {len(scenes)} сцен — остальные сервис не отдал (обычно это лимит видео на ключе), "
               f"они останутся картинками с движением. Чтобы дооживить: запустите это же видео ещё раз позже")
        log(msg)
        say("videos", len(scenes), len(scenes), msg)
    return {s["index"]: os.path.join(vid_dir, f"{s['index']:04d}.mp4") for s in scenes
            if os.path.exists(os.path.join(vid_dir, f"{s['index']:04d}.mp4"))}


# ============ шаг 5: сборка видео ============

def kenburns_path(i, duration):
    """Цикл: статика, зум, статика, влево, статика, вправо."""
    D = max(duration, 0.1)

    def lin(t):
        return min(1.0, max(0.0, t / D))

    kinds = [
        None,
        lambda t: (1.0 + 0.12 * lin(t), 0.5, 0.5),
        None,
        lambda t: (1.10, 1.0 - lin(t), 0.5),
        None,
        lambda t: (1.10, lin(t), 0.5),
    ]
    return kinds[i % len(kinds)]


EDGE_CROP = 0.035  # срезаем 3.5% по краям: там генераторы ставят маленький логотип-водяной знак


def _fit_16_9(im):
    sw, sh = im.size
    dx, dy = int(sw * EDGE_CROP), int(sh * EDGE_CROP)
    im = im.crop((dx, dy, sw - dx, sh - dy))
    sw, sh = im.size
    if sw / sh > W / H:
        nw = int(round(sh * W / H)); im = im.crop(((sw - nw) // 2, 0, (sw - nw) // 2 + nw, sh))
    else:
        nh = int(round(sw * H / W)); im = im.crop((0, (sh - nh) // 2, sw, (sh - nh) // 2 + nh))
    return im


def render_scene_clip(img_path, i, duration, out_path):
    if os.path.exists(out_path):
        try:
            if os.path.getmtime(out_path) >= os.path.getmtime(img_path):
                return out_path
            os.remove(out_path)  # картинку перерисовали позже клипа — клип устарел
        except OSError:
            return out_path
    duration = max(0.3, float(duration))
    from PIL import Image

    path = kenburns_path(i, duration)
    tmp = out_path + ".tmp.mp4"
    im = _fit_16_9(Image.open(img_path).convert("RGB"))
    if path is None:
        still = out_path + ".still.png"
        im.resize((W, H), Image.LANCZOS).save(still)
        run_ffmpeg(["-loop", "1", "-framerate", str(FPS), "-i", still, "-t", f"{duration:.3f}", "-r", str(FPS),
                    "-c:v", "libx264", "-preset", "veryfast", "-crf", "20", "-pix_fmt", "yuv420p", "-an", tmp])
        os.remove(still)
        os.replace(tmp, out_path)
        return out_path
    frames = max(2, int(round(duration * FPS)))
    BW, BH = W * 2, H * 2
    im = im.resize((BW, BH), Image.LANCZOS)
    cmd = [ffmpeg_bin(), "-y", "-loglevel", "error", "-f", "rawvideo", "-pix_fmt", "rgb24", "-s", f"{W}x{H}",
           "-r", str(FPS), "-i", "-", "-t", f"{duration:.3f}",
           "-c:v", "libx264", "-preset", "veryfast", "-crf", "20", "-pix_fmt", "yuv420p", "-an", tmp]
    proc = subprocess.Popen(cmd, stdin=subprocess.PIPE, stderr=subprocess.PIPE, creationflags=NO_WINDOW)
    try:
        for n in range(frames):
            if n % 25 == 0:
                check_cancel()
            z, cx, cy = path(n / FPS)
            ww, wh = BW / z, BH / z
            x0, y0 = (BW - ww) * cx, (BH - wh) * cy
            frame = im.transform((W, H), Image.AFFINE, (ww / W, 0, x0, 0, wh / H, y0), resample=Image.BILINEAR)
            proc.stdin.write(frame.tobytes())
        proc.stdin.close()
        err = proc.stderr.read().decode(errors="replace")
        if proc.wait() != 0:
            raise RuntimeError(f"ffmpeg не смог закодировать клип {i}: {err[:400]}")
    finally:
        if proc.poll() is None:
            proc.kill()
    os.replace(tmp, out_path)
    return out_path


def render_video_clip(src_mp4, duration, out_path):
    """Подогнать сгенерированный клип под длительность сцены: 1920x1080, 25 к/с, без звука.
    Если клип короче сцены — последний кадр держится до конца."""
    if os.path.exists(out_path):
        return out_path
    duration = max(0.3, float(duration))  # как и для картинок: отрицательная длительность → ffmpeg «duration out of range»
    tmp = out_path + ".tmp.mp4"
    vf = (f"scale={W}:{H}:force_original_aspect_ratio=increase,crop={W}:{H},setsar=1,fps={FPS},"
          f"tpad=stop_mode=clone:stop_duration={duration + 1:.3f}")
    run_ffmpeg(["-i", src_mp4, "-vf", vf, "-t", f"{duration:.3f}", "-an",
                "-c:v", "libx264", "-preset", "veryfast", "-crf", "20", "-pix_fmt", "yuv420p", tmp])
    os.replace(tmp, out_path)
    return out_path


TRANSITIONS = ["fade", "slideleft", "circleopen", "wipeleft", "dissolve", "smoothleft", "fadeblack", "zoomin"]


def assemble_video(scenes, img_dir, videos, audio_path, job_dir, out_mp4, progress, motion=False):
    clips_dir = os.path.join(job_dir, "clips" + ("_m" if motion else ""))
    os.makedirs(clips_dir, exist_ok=True)
    n = len(scenes)
    workers = max(1, min(4, (os.cpu_count() or 2) // 2))
    extra = TRANSITION if motion else 0.0  # в моушн-режиме клипы длиннее на время перехода

    grouped = motion and n > XFADE_GROUP

    def one(s):
        check_cancel()
        i = s["index"]
        dur = s["duration"] + extra  # каждый клип длиннее на переход: следующий начинается на T раньше и заканчивается вовремя
        tail = grouped and ((i + 1) % XFADE_GROUP == 0 or i == n - 1)  # последний клип группы: ещё +T, его съест переход второго уровня
        if tail:
            dur += TRANSITION
        suffix = "_x" if tail else ""
        if i in videos:
            clip = os.path.join(clips_dir, f"{i:04d}_v{suffix}.mp4")
            render_video_clip(videos[i], dur, clip)
        else:
            clip = os.path.join(clips_dir, f"{i:04d}{suffix}.mp4")
            render_scene_clip(os.path.join(img_dir, f"{i:04d}.png"), i, dur, clip)
        return clip

    done = 0
    clips = [None] * n
    with cf.ThreadPoolExecutor(max_workers=workers) as ex:
        futs = {ex.submit(one, s): s["index"] for s in scenes}
        for f in cf.as_completed(futs):
            clips[futs[f]] = f.result()
            done += 1
            progress("render", done, n, "собираю кадры")
    if motion and n > 1:
        progress("render", n, n, "моушн-переходы и звук")
        return concat_with_transitions(clips, scenes, audio_path, out_mp4, job_dir)
    progress("render", n, n, "склеиваю и добавляю звук")
    lst = os.path.join(job_dir, "concat.txt")
    with open(lst, "w", encoding="utf-8") as f:
        for c in clips:
            f.write("file '" + c.replace("\\", "/").replace("'", "'\\''") + "'\n")
    tmp = out_mp4 + ".tmp.mp4"
    run_ffmpeg(["-f", "concat", "-safe", "0", "-i", lst, "-i", audio_path, "-map", "0:v:0", "-map", "1:a:0",
                "-c:v", "copy", "-c:a", "aac", "-b:a", "192k", "-shortest", "-movflags", "+faststart", tmp])
    os.replace(tmp, out_mp4)
    return out_mp4


MAX_COPIES_SHARE = 0.05  # больше 5 % сцен без картинки (и больше MAX_COPIES_MIN штук) — останавливаемся, а не клеим копии
MAX_COPIES_MIN = 3
XFADE_GROUP = 30  # клипов в одной команде ffmpeg. Больше нельзя: 413 входов + 412 переходов = командная строка длиннее
                  # 32 767 символов, и Windows отвечает WinError 206 «имя файла слишком длинное» (тестеры ловили на длинных роликах)


def xfade_chain(clips, durations, kind0=0):
    """Входы и filter_complex для цепочки xfade. durations — длительности сцен без T; каждый клип длиннее на T."""
    args = []
    for c in clips:
        args += ["-i", c]
    parts, prev, offset = [], "[0:v]", 0.0
    for k in range(1, len(clips)):
        offset += durations[k - 1]
        kind = TRANSITIONS[(kind0 + k - 1) % len(TRANSITIONS)]
        out = f"[v{k}]" if k < len(clips) - 1 else "[vout]"
        parts.append(f"{prev}[{k}:v]xfade=transition={kind}:duration={TRANSITION}:offset={offset - TRANSITION:.3f}{out}")
        prev = out
    return args, ";".join(parts)


def concat_with_transitions(clips, scenes, audio_path, out_mp4, job_dir=None):
    """Склейка через xfade: каждый переход длится TRANSITION с, сцены остаются синхронными с озвучкой.
    Длинные ролики — группами по XFADE_GROUP: сначала промежуточные ролики без звука, потом переходы между ними."""
    durs = [s["duration"] for s in scenes]
    enc = ["-c:v", "libx264", "-preset", "veryfast", "-crf", "20", "-pix_fmt", "yuv420p"]
    if len(clips) > XFADE_GROUP:
        gdir = os.path.join(job_dir or os.path.dirname(clips[0]), "groups")
        os.makedirs(gdir, exist_ok=True)
        gclips, gdurs = [], []
        groups = [list(range(b, min(b + XFADE_GROUP, len(clips)))) for b in range(0, len(clips), XFADE_GROUP)]
        for gi, idx in enumerate(groups):
            check_cancel()
            if len(idx) == 1:
                gclips.append(clips[idx[0]])
            else:
                gout = os.path.join(gdir, f"g{gi:03d}.mp4")
                args, fc = xfade_chain([clips[i] for i in idx], [durs[i] for i in idx], kind0=idx[0])
                run_ffmpeg(args + ["-filter_complex", fc, "-map", "[vout]", "-an", *enc, gout])
                gclips.append(gout)
            gdurs.append(sum(durs[i] for i in idx))
        clips, durs = gclips, gdurs
    args, fc = xfade_chain(clips, durs)
    args += ["-i", audio_path]
    tmp = out_mp4 + ".tmp.mp4"
    if fc:
        run_ffmpeg(args + ["-filter_complex", fc, "-map", "[vout]", "-map", f"{len(clips)}:a:0", *enc,
                           "-c:a", "aac", "-b:a", "192k", "-shortest", "-movflags", "+faststart", tmp])
    else:
        run_ffmpeg(args + ["-map", "0:v:0", "-map", "1:a:0", "-c:v", "copy", "-c:a", "aac", "-b:a", "192k", "-shortest", "-movflags", "+faststart", tmp])
    os.replace(tmp, out_mp4)
    return out_mp4


# ============ озвучка сценария ============

def script_job_dir(script_text):
    h = hashlib.sha1(script_text.strip().encode("utf-8")).hexdigest()[:10]
    d = os.path.join(data_dir(), "jobs", "script_" + h)
    os.makedirs(d, exist_ok=True)
    return d, "script_" + h


def make_voiceover(cfg, script_text, tts_service, voice_id, job_dir, progress):
    """Озвучить сценарий выбранным сервисом; результат кэшируется в job_dir/voiceover.mp3."""
    out = os.path.join(job_dir, "voiceover.mp3")
    if os.path.exists(out) and os.path.getsize(out) > 1000:
        progress("tts", 1, 1, "озвучка уже есть, пропускаю")
        return out
    key = cfg.get(f"{tts_service}_api_key")
    if tts_service == "fastgen" and not key:
        key = (provider_keys(cfg, "fastgen") or [""])[0]
    from tts_api import KEYLESS
    if not key and tts_service not in KEYLESS:
        raise SystemExit(f"Для озвучки выбран {tts_service}, но ключ не введён.")
    with open(os.path.join(job_dir, "script.txt"), "w", encoding="utf-8") as f:
        f.write(script_text)
    progress("tts", 0, 1, f"озвучиваю сценарий ({tts_service})")
    client = make_tts(tts_service, key)
    try:
        client.synthesize(script_text, voice_id or None, out + ".part", progress=lambda m: progress("tts", 0, 1, m))
    except Cancelled:
        raise
    except (requests.exceptions.ConnectionError, requests.exceptions.Timeout) as e:
        # до сервиса вообще не достучались — резать текст на части бессмысленно, говорим по-человечески
        host = {"lumean": "api.lumean.app", "voicer": "voicer.mat3u.com", "voicegen": "qw1voicegencore.pro", "fastgen": "api.fast-gen.ai"}.get(tts_service, tts_service)
        raise SystemExit(f"Не удалось подключиться к сервису озвучки {tts_service} ({host}). Сервис либо временно недоступен, либо не открывается "
                         f"из вашей сети: проверьте, открывается ли https://{host} в браузере, попробуйте включить или выключить VPN "
                         f"и запустите снова. Либо выберите озвучку «Edge · бесплатно» — она работает без ключа.") from e
    except Exception as e:
        # длинный сценарий сервис мог не принять целиком — озвучиваем частями и склеиваем
        if len(script_text) < 2500:
            raise
        log(f"озвучка целиком не удалась ({str(e)[:120]}), пробую частями")
        parts = split_text(script_text, 3500)
        files = []
        for k, part in enumerate(parts):
            check_cancel()
            progress("tts", k, len(parts), f"озвучиваю сценарий ({tts_service}), часть {k + 1} из {len(parts)}")
            f = os.path.join(job_dir, f"voice_part{k:03d}.mp3")
            if not (os.path.exists(f) and os.path.getsize(f) > 1000):
                client.synthesize(part, voice_id or None, f + ".part", progress=lambda m: progress("tts", k, len(parts), m))
                os.replace(f + ".part", f)
            files.append(f)
        lst = os.path.join(job_dir, "voice_concat.txt")
        with open(lst, "w", encoding="utf-8") as fh:
            for f in files:
                fh.write("file '" + f.replace("\\", "/").replace("'", "'\\''") + "'\n")
        run_ffmpeg(["-f", "concat", "-safe", "0", "-i", lst, "-c:a", "libmp3lame", "-b:a", "192k", "-f", "mp3", out + ".part"])
        for f in files:
            try:
                os.remove(f)
            except OSError:
                pass
    os.replace(out + ".part", out)
    progress("tts", 1, 1, "озвучка готова")
    return out


def split_text(text, limit):
    """Режем текст на куски не длиннее limit символов по границам предложений (в крайнем случае — по пробелу)."""
    sents = re.split(r"(?<=[.!?…])\s+", text.strip())
    parts, cur = [], ""
    for snt in sents:
        while len(snt) > limit:  # одно гигантское «предложение»
            cut = snt.rfind(" ", 0, limit)
            cut = cut if cut > limit // 2 else limit
            if cur:
                parts.append(cur); cur = ""
            parts.append(snt[:cut].strip()); snt = snt[cut:].strip()
        if len(cur) + len(snt) + 1 > limit and cur:
            parts.append(cur); cur = snt
        else:
            cur = (cur + " " + snt).strip()
    if cur:
        parts.append(cur)
    return [p for p in parts if p]


# ============ главные функции ============

def dir_size(path):
    total = 0
    for root, _, files in os.walk(path):
        for f in files:
            try:
                total += os.path.getsize(os.path.join(root, f))
            except OSError:
                pass
    return total


def cleanup_job(job_dir):
    """После успешной сборки убираем то, что легко пересобрать: клипы, группы переходов, видео без субтитров.
    Картинки, оживлённые клипы, озвучка и json остаются — повторный запуск по-прежнему ничего не рисует заново.
    Раньше не удалялось ничего: сорокаминутный ролик оставлял около 5 ГБ."""
    freed = 0
    for name in ("clips", "clips_m", "groups"):
        p = os.path.join(job_dir, name)
        if os.path.isdir(p):
            freed += dir_size(p)
            shutil.rmtree(p, ignore_errors=True)
    for name in ("nosubs.mp4", "concat.txt", "voice_concat.txt"):
        p = os.path.join(job_dir, name)
        if os.path.exists(p):
            try:
                freed += os.path.getsize(p)
                os.remove(p)
            except OSError:
                pass
    if freed > 50 * 1024 * 1024:
        log(f"убрал промежуточные файлы задания: освобождено {freed / 1e9:.1f} ГБ")


JOB_KEEP_DAYS = 30


def prune_old_jobs():
    """При запуске программы: папки заданий, к которым не прикасались JOB_KEEP_DAYS дней, удаляются целиком. Готовые видео лежат
    в output и не затрагиваются."""
    root = os.path.join(data_dir(), "jobs")
    if not os.path.isdir(root):
        return 0
    limit, freed = time.time() - JOB_KEEP_DAYS * 86400, 0
    for name in os.listdir(root):
        p = os.path.join(root, name)
        try:
            newest = max([os.path.getmtime(p)] + [os.path.getmtime(os.path.join(p, f)) for f in os.listdir(p)]) if os.path.isdir(p) else os.path.getmtime(p)
        except OSError:
            continue
        if newest < limit:
            size = dir_size(p) if os.path.isdir(p) else os.path.getsize(p)
            shutil.rmtree(p, ignore_errors=True) if os.path.isdir(p) else os.remove(p)
            freed += size
    if freed:
        log(f"удалены задания старше {JOB_KEEP_DAYS} дней: освобождено {freed / 1e9:.1f} ГБ")
    return freed


def make_context(cfg, providers):
    """providers — выбранные сервисы. Каждый ключ сервиса — отдельный «юнит» (fastgen, fastgen#2, …) со своими лимитами;
    сцены делятся между юнитами по кругу. Сервисы с ключом, но без галочки, — подстраховка."""
    keys = {p: provider_keys(cfg, p) for p in PROVIDERS}
    for p in providers:
        if not keys[p]:
            raise SystemExit(f"Отмечен {PROVIDER_NAMES[p]}, но его ключ не введён")
    api = FastGen(keys["fastgen"][0]) if keys["fastgen"] else None
    ctx = {"api": api, "providers": [], "bases": list(providers), "gates": {}, "image_gen": {},
           "nonstop": None, "yougen": None, "royal": None, "slider": None, "google": None, "sliders": [], "fallback": []}

    def add(p, n, key, selected):
        unit = p if n == 0 else f"{p}#{n + 1}"
        try:
            if p == "fastgen":
                c = api if n == 0 else FastGen(key)
                g = RateGate(c, "image")
                fn = lambda sc, out, pr, refs, c=c, g=g: gen_fastgen_image(c, g, sc, out, pr, refs)
            elif p == "nonstop":
                c = NonStop(key); g = NonStopGate(c); ctx["nonstop"] = ctx["nonstop"] or c
                fn = lambda sc, out, pr, refs, c=c, g=g: gen_nonstop_image(c, g, sc, out, pr, refs)
            elif p == "yougen":
                c = YouGen(key); g = YouGenGate(c); ctx["yougen"] = ctx["yougen"] or c
                fn = lambda sc, out, pr, refs, c=c, g=g: gen_yougen_image(c, g, sc, out, pr, refs)
            elif p == "royal":
                c = RoyalTechno(key); g = RoyalGate(c); ctx["royal"] = ctx["royal"] or c
                fn = lambda sc, out, pr, refs, c=c, g=g: gen_royal_image(c, g, sc, out, pr, refs)
            elif p == "google":
                c = GoogleAI(key); g = GoogleGate(c); ctx["google"] = ctx["google"] or c
                fn = lambda sc, out, pr, refs, c=c, g=g: gen_google_image(c, g, sc, out, pr, refs)
            else:
                c = SecretSlider(key); g = SliderGate(c); ctx["slider"] = ctx["slider"] or c; ctx["sliders"].append((c, g))
                fn = lambda sc, out, pr, refs: None
        except Exception as e:
            if selected:
                raise
            log(f"подстраховка {unit_name(unit)} недоступна: {str(e)[:120]}")
            return
        ctx["gates"][unit] = g
        ctx["image_gen"][unit] = fn
        (ctx["providers"] if selected else ctx["fallback"]).append(unit)

    for p in providers:
        for n, k in enumerate(keys[p]):
            add(p, n, k, True)
    for p in ("fastgen", "nonstop", "yougen", "royal", "google"):
        if p not in providers:
            for n, k in enumerate(keys[p]):
                add(p, n, k, False)
    return ctx


LAST_JOB_DIR = None
REWRITE_KEYS = {"openai": "openai_api_key", "anthropic": "anthropic_api_key", "gemini": "gemini_api_key", "fastgen": "fastgen_api_key"}


def rewrite_script(cfg, rw, progress):
    """Источник (ссылка YouTube или текст) → переписанный сценарий выбранной моделью."""
    import rewrite as rwmod
    say = lambda m: progress("rewrite", 0, 1, m)
    if (rw.get("source") or "text") == "youtube":
        url = (rw.get("url") or "").strip()
        if not url:
            raise SystemExit("Вставьте ссылку на ролик YouTube.")
        try:
            text = rwmod.youtube_transcript(url, say)
        except Exception as e:
            log(f"субтитры YouTube не получены ({str(e)[:120]}), пробую скачать звук")
            audio = rwmod.youtube_audio(url, os.path.join(data_dir(), "jobs"), os.path.dirname(ffmpeg_bin()), say)
            engine, api, _, _ = make_text_engine(cfg)
            jd, _ = job_dir_for(audio)
            text = transcribe(engine, api, audio, jd, progress, audio_duration(audio))["text"]
    else:
        text = (rw.get("text") or "").strip()
        if not text:
            raise SystemExit("Вставьте текст сценария для рерайта.")
    engine = rw.get("engine") or cfg.get("rewrite_engine") or "fastgen"
    key = cfg.get(REWRITE_KEYS.get(engine, ""), "")
    if not key:
        raise SystemExit(f"Для рерайта выбран {rwmod.ENGINE_NAMES.get(engine, engine)}, но его ключ не введён.")
    return rwmod.rewrite(text, engine, key, None, rw.get("words") or cfg.get("rewrite_words") or 1500,
                         rw.get("language") or cfg.get("rewrite_lang") or "польском", os.path.join(data_dir(), "jobs"), say)


def resolve_source(cfg, audio_path, script_text, tts_service, tts_voice, progress, rewrite=None):
    """Либо готовый mp3, либо сценарий (свой или после рерайта), который надо озвучить. Возвращает (audio_path, job_dir, base)."""
    global LAST_JOB_DIR
    if rewrite and rewrite.get("on"):
        script_text = rewrite_script(cfg, rewrite, progress)
        progress("rewrite", 1, 1, f"сценарий переписан: {len(script_text.split())} слов")
    if script_text and script_text.strip():
        job_dir, base = script_job_dir(script_text)
        LAST_JOB_DIR = job_dir
        audio_path = make_voiceover(cfg, script_text.strip(), tts_service or cfg.get("tts_service") or "voicegen",
                                    tts_voice if tts_voice is not None else cfg.get("tts_voice", ""), job_dir, progress)
        return audio_path, job_dir, base
    audio_path = os.path.abspath(audio_path)
    job_dir, base = job_dir_for(audio_path)
    LAST_JOB_DIR = job_dir
    return audio_path, job_dir, base


def prepare(audio_path=None, progress_cb=None, provider=None, mode="images", use_refs=False,
            script_text=None, tts_service=None, tts_voice=None, rewrite=None):
    """Первая половина: (озвучка) + транскрипция + сцены. Возвращает оценку для подтверждения."""
    progress = Progress(progress_cb)
    CANCEL.clear()
    cfg = load_config()
    providers = normalize_providers(provider or cfg.get("image_providers") or cfg.get("image_provider"))
    audio_path, job_dir, base = resolve_source(cfg, audio_path, script_text, tts_service, tts_voice, progress, rewrite)
    duration = audio_duration(audio_path)
    engine, text_api, _, _ = make_text_engine(cfg)
    tr = transcribe(engine, text_api, audio_path, job_dir, progress, duration)
    scenes_path = os.path.join(job_dir, "scenes.json")
    scenes = read_json(scenes_path)
    if scenes and not scenes_ok(scenes):
        log("сцены из старой версии с битыми таймкодами — режу заново")
        scenes = None
    if not scenes:
        scenes = split_scenes(tr["words"], duration)
        write_json(scenes_path, scenes)
    n = len(scenes)
    img_dir = os.path.join(job_dir, "images")
    have_images = sum(1 for s in scenes if os.path.exists(os.path.join(img_dir, f"{s['index']:04d}.png")))
    todo = n - have_images
    share = {p: len([i for i in range(todo) if providers[i % len(providers)] == p]) for p in providers}
    est = {
        "scenes": n, "duration": round(duration), "have_images": have_images,
        "providers": providers, "text_engine": engine,
        "fastgen_credits_images": share.get("fastgen", 0) * (4 if use_refs else 1) + (8 if use_refs and "fastgen" in providers else 0),
        "nonstop_images": share.get("nonstop", 0),
        "yougen_images": share.get("yougen", 0),
        "royal_images": share.get("royal", 0),
        "slider_images": share.get("slider", 0),
        "google_images": share.get("google", 0),
        "video_clips": n if mode == "video" else ((n + 1) // 2 if mode == "mixed" else 0),
        "minutes": round(1 + n * {"images": 0.15, "mixed": 0.7, "video": 1.2}.get(mode, 0.15)),
        "audio_path": audio_path, "job_dir": job_dir,
        "text_preview": tr["text"][:300],
    }
    progress("prepare", 1, 1, f"сцен: {n}, длительность {duration:.0f} с")
    return est


def make_video(audio_path=None, progress_cb=None, out_dir=None, provider=None, mode="images", style_key=None, use_refs=False,
               subtitles=False, motion=False, script_text=None, tts_service=None, tts_voice=None, fastgen_quality=None, rewrite=None,
               video_first=0, hd=False):
    global FASTGEN_QUALITY, HD_IMAGES
    HD_IMAGES = bool(hd)
    progress = Progress(progress_cb)
    CANCEL.clear()
    clear_wait()
    cfg = load_config()
    providers = normalize_providers(provider or cfg.get("image_providers") or cfg.get("image_provider"))
    if mode not in MODES:
        raise SystemExit(f"Неизвестный режим: {mode}")
    style_key = style_key or cfg.get("style") or DEFAULT_STYLE
    FASTGEN_QUALITY = (fastgen_quality or cfg.get("quality") or cfg.get("fastgen_quality") or "speed")
    if FASTGEN_QUALITY not in IMAGE_CHAINS:
        FASTGEN_QUALITY = "speed"
    audio_path, job_dir, base = resolve_source(cfg, audio_path, script_text, tts_service, tts_voice, progress, rewrite)
    out_dir = out_dir or os.path.join(data_dir(), "output")
    os.makedirs(out_dir, exist_ok=True)
    out_mp4 = os.path.join(out_dir, base + ".mp4")
    if os.path.exists(os.path.join(job_dir, "script.txt")):
        shutil.copy(os.path.join(job_dir, "script.txt"), os.path.join(out_dir, base + ".txt"))  # сценарий рядом с видео

    duration = audio_duration(audio_path)
    progress("start", 0, 0, f"аудио {duration:.0f} с · картинки: {' + '.join(PROVIDER_NAMES[p] for p in providers)} · режим: {mode} · стиль: {STYLES.get(style_key, STYLES[DEFAULT_STYLE])[0]}")
    ctx = make_context(cfg, providers)
    engine, text_api, llm_name, llm_api = make_text_engine(cfg)
    llm = LLM(llm_name, llm_api, cfg.get("openai_model") if llm_name == "openai" else cfg.get("llm_model"))
    llm.progress = progress
    progress("start", 0, 0, f"речь: {engine} · тексты: {llm_name} ({llm.model}) · fast-gen: {FASTGEN_QUALITY}")

    tr = transcribe(engine, text_api, audio_path, job_dir, progress, duration)
    scenes_path = os.path.join(job_dir, "scenes.json")
    scenes = read_json(scenes_path)
    if scenes and not scenes_ok(scenes):
        log("сцены из старой версии с битыми таймкодами — режу заново")
        scenes = None
    if not scenes:
        scenes = split_scenes(tr["words"], duration)
        write_json(scenes_path, scenes)
    progress("scenes", len(scenes), len(scenes), f"сцен: {len(scenes)}")

    style = build_style(llm, tr["text"], job_dir, progress, style_key)
    refs, ref_pool = {}, None
    if use_refs:
        # портреты героев зависят только от библии — рисуем их, пока пишутся промпты сцен (сообщения пока в журнал)
        ref_quiet = threading.Event()
        ref_quiet.set()

        def ref_progress(*a):
            if ref_quiet.is_set():
                if len(a) > 3 and a[3]:
                    log(a[3])
                return
            return progress(*a)
        ref_pool = cf.ThreadPoolExecutor(max_workers=1)
        ref_fut = ref_pool.submit(make_references, ctx, style, job_dir, ref_progress)
    scenes = build_prompts(llm, style, scenes, job_dir, progress, use_refs)
    if ref_pool:
        ref_quiet.clear()
        if not ref_fut.done():
            progress("refs", 0, 0, "дорисовываю портреты героев")
        refs = ref_fut.result()
        ref_pool.shutdown(wait=True)
    drop_failed_images(scenes, job_dir)
    pre = Prerender(scenes, os.path.join(job_dir, "images"), job_dir, mode, motion, video_first)
    overlap = VideoOverlap(ctx, scenes, job_dir, progress, mode, video_first) if (mode in ("video", "mixed") or video_first) else None
    try:
        img_dir = generate_all_images(ctx, scenes, style, job_dir, progress, refs, on_image=pre.submit)
    except BaseException:
        if overlap:
            overlap.abort()
        raise
    videos = overlap.result() if overlap else {}
    pre.wait()
    if subtitles:
        raw_mp4 = os.path.join(job_dir, "nosubs.mp4")
        assemble_video(scenes, img_dir, videos, audio_path, job_dir, raw_mp4, progress, motion=motion)
        check_cancel()
        progress("subtitles", 0, 1, "накладываю субтитры")
        # .srt кладём в подпапку: файл с тем же именем рядом с mp4 плееры подхватывают сами и рисуют
        # свои субтитры поверх уже вшитых — у тестера текст «двоился»
        os.makedirs(os.path.join(out_dir, "subtitles"), exist_ok=True)
        srt_path = os.path.join(out_dir, "subtitles", base + ".srt")
        subs.write_srt(tr["words"], srt_path)
        subs.burn(ffmpeg_bin(), raw_mp4, srt_path, out_mp4 + ".tmp.mp4", NO_WINDOW)
        os.replace(out_mp4 + ".tmp.mp4", out_mp4)
        progress("subtitles", 1, 1, "субтитры наложены, .srt сохранён в папке output/subtitles")
    else:
        assemble_video(scenes, img_dir, videos, audio_path, job_dir, out_mp4, progress, motion=motion)
    clear_wait()
    cleanup_job(job_dir)
    progress("done", 1, 1, f"готово: {out_mp4}")
    return out_mp4


if __name__ == "__main__":
    try:
        sys.stdout.reconfigure(encoding="utf-8", errors="replace")
    except Exception:
        pass
    if len(sys.argv) < 2:
        print(__doc__)
        sys.exit(1)

    def arg(name, default=None):
        return sys.argv[sys.argv.index(name) + 1] if name in sys.argv else default

    make_video(sys.argv[1], provider=arg("--provider"), mode=arg("--mode", "images"), style_key=arg("--style"),
               use_refs="--refs" in sys.argv, subtitles="--subs" in sys.argv, motion="--motion" in sys.argv,
               fastgen_quality=arg("--quality"))
