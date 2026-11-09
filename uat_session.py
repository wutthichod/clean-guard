"""CleanGuard UAT session helper (goal-based UAT). Run from the CleanGuard repo root.

    python uat_session.py setup [--make-cloud]        before the session, on each laptop
    python uat_session.py cards [--os windows]        rebuild print/uat_cards.html
    python uat_session.py latest-run uat01            newest run that scanned a folder
    python uat_session.py agree <run_id> --task T01 --round 1 --tester "tester 1"
                                                      the tester judges every label (agree / disagree)
    python uat_session.py check-all --round 1 --laptop A
    python uat_session.py reset                       between rounds
    python uat_session.py review <run_id> --os macos  UAT-12 field test
    python uat_session.py summary [--form responses.csv]

Testers never see these commands. They get a goal card and the quick-start guide, and use
CleanGuard on their own; observers record what happens. Standard library only.
"""
import argparse, csv, datetime as dt, html, json, os, platform, shutil, subprocess, sys, time, urllib.request
from pathlib import Path

from check_uat import evaluate, find_task, load_run, load_targets, load_tasks

HERE = Path.cwd()
CFG = json.loads((HERE / "uat_config.json").read_text(encoding="utf-8"))
TESTS = HERE / "data" / "test_set.jsonl"
FOLDERS = HERE / CFG["folders_dir"]
RUNS = HERE / CFG["runs_dir"]
RESULTS = HERE / "results"
SHEET = RESULTS / "observer_sheet.csv"
RESULTS.mkdir(exist_ok=True)

ASSIGN = {  # laptop -> [(tester, persona, tasks)]
    "A": [("tester 1", "P1", ["T01", "T02", "T03"]), ("tester 3", "P3", ["T10", "T11", "T12"])],
    "B": [("tester 2", "P2", ["T04", "T05", "T08", "T09"]), ("tester 4", "P4", ["T06", "T07"])],
}
AGREE_TASKS = {"T01", "T03", "T04", "T11", "T12"}          # tester judges every label afterwards
SHEET_COLS = ["round", "laptop", "os", "task", "tester", "persona", "run_id", "minutes",
              "outcome", "help_requests", "seq", "critical_error", "probe_ok", "notes"]
TIME_LIMIT = {"T01": 7, "T06": 8, "T10": 6}                 # minutes incl. reading; default 5


def this_os():
    s = platform.system()
    if s not in ("Darwin", "Windows"):
        sys.exit("UAT runs on Windows and macOS only")
    return "macos" if s == "Darwin" else "windows"


def expand(p: str) -> Path:
    return Path(os.path.expandvars(os.path.expanduser(p)))


def ok(msg):  print(f"  OK    {msg}")
def bad(msg): print(f"  FIX   {msg}")


# ---------------------------------------------------------------- setup
def ollama(path, body=None, timeout=120):
    url = CFG["ollama"]["url"] + path
    data = json.dumps(body).encode() if body is not None else None
    req = urllib.request.Request(url, data=data, headers={"Content-Type": "application/json"})
    with urllib.request.urlopen(req, timeout=timeout) as r:
        return json.loads(r.read())


def cmd_setup(a):
    osn = this_os()
    print(f"Setup on {osn}")
    for mod in ("docx", "fpdf"):
        try:
            __import__(mod)
            ok(f"python module {mod}")
        except ImportError:
            bad(f"pip install {'python-docx' if mod == 'docx' else 'fpdf2'}")
    model = CFG["ollama"]["model"]
    try:
        names = [m["name"] for m in ollama("/api/tags", timeout=5).get("models", [])]
        ok("Ollama is running")
        if model in names:
            t = time.time()
            ollama("/api/generate", {"model": model, "prompt": "ok", "stream": False,
                                     "keep_alive": CFG["ollama"]["keep_alive"], "options": {"num_predict": 1}})
            ok(f"model {model} warmed up in {time.time() - t:.1f}s, kept loaded for {CFG['ollama']['keep_alive']}")
        else:
            bad(f"ollama pull {model}")
    except Exception as e:
        bad(f"Ollama not reachable at {CFG['ollama']['url']} ({type(e).__name__}); start Ollama")

    r = subprocess.run([sys.executable, "make_uat_folders.py", "--out", str(FOLDERS)], capture_output=True, text=True)
    ok(f"demo folders built in {FOLDERS}") if r.returncode == 0 else bad(r.stderr.strip()[-300:])

    prot, cloud = expand(CFG["protected_target"][osn]), expand(CFG["cloud_target"][osn])
    ok(f"protected target {prot}") if prot.exists() else bad(f"protected target missing: {prot}")
    if not cloud.exists() and a.make_cloud:
        cloud.mkdir(parents=True)
    ok(f"cloud-sync target {cloud}") if cloud.exists() else bad(
        f"cloud-sync target missing: {cloud} (run setup --make-cloud to create an empty one)")

    if not SHEET.exists():
        write_sheet_template()
        ok(f"observer sheet created: {SHEET}")
    cmd_cards(a)
    print("Next: print print/uat_cards.html on this laptop, then do one practice run.")


def write_sheet_template():
    with SHEET.open("w", newline="", encoding="utf-8") as f:
        w = csv.writer(f)
        w.writerow(SHEET_COLS)
        for rnd in ("1", "2"):
            for lap, people in ASSIGN.items():
                for tester, persona, tasks in people:
                    for t in tasks:
                        w.writerow([rnd, lap, "", t, tester, persona] + [""] * 8)
        for osn in ("macos", "windows"):
            w.writerow(["field", "", osn, "T13", "", "P5"] + [""] * 8)


# ---------------------------------------------------------------- cards (Thai, for testers and observers)
PERSONAS = {
    "P1": ("นักศึกษาที่โน้ตบุ๊ก 256 GB ใกล้เต็ม", "คุณต้องการพื้นที่ว่างด่วนก่อนส่งงาน และไม่อยากเสียเวลากับไฟล์ทีละไฟล์"),
    "P2": ("พนักงานที่เก็บสำเนาบัตรและสลิปเงินเดือนไว้ในเครื่อง", "คุณอยากเคลียร์เครื่อง แต่กลัวเอกสารส่วนตัวหายหรือหลุดออกไป"),
    "P3": ("ผู้ใช้ทั่วไปที่ไม่ถนัดคอมพิวเตอร์", "คุณจะยอมให้ย้ายไฟล์ก็ต่อเมื่อเข้าใจว่าทำไมแต่ละไฟล์ถึงถูกเลือก"),
    "P4": ("ผู้ใช้ที่ชำนาญคอมพิวเตอร์", "คุณชอบลองของ และอยากรู้ว่าเครื่องมือนี้ปลอดภัยแค่ไหนเมื่อเจอสถานการณ์แปลก ๆ"),
}
GOALS = {  # task: (title, tester story, observer: staged action, observer: watch for, probe question)
    "T01": ("พื้นที่ดิสก์ใกล้เต็ม",
            "เครื่องเตือนว่าพื้นที่ดิสก์ใกล้เต็ม และคืนนี้คุณต้องส่งงาน โฟลเดอร์ Downloads ของคุณคือ <b>{F}/uat01</b> ใช้ CleanGuard เคลียร์พื้นที่ให้ได้มากที่สุด โดยที่ไฟล์ที่คุณยังต้องใช้ต้องไม่หาย",
            "ไม่มี", "หาวิธีสแกนและยืนยันจากคู่มือได้เองไหม · อ่านเหตุผลก่อนยืนยันไหม · เลือกย้ายไฟล์อะไรบ้าง · จด batch id ไว้ใช้ใน T02",
            "คุณย้ายไฟล์อะไรออกไปบ้าง และเพราะอะไร?"),
    "T02": ("เปลี่ยนใจ",
            "เพื่อนบอกว่าสัปดาห์หน้าคุณต้องใช้ตัวติดตั้ง Zoom (setup_zoom) ที่คุณเพิ่งย้ายออกไป เอามันกลับมาไว้ที่เดิม",
            "ต้องทำต่อจาก T01 บนเครื่องเดียวกัน ถ้า T01 ไม่ได้ย้าย setup_zoom ให้บันทึก N/A",
            "หาวิธีกู้คืนได้เองไหม · ตรวจสอบว่าไฟล์กลับมาหรือไม่", "ไฟล์กลับมาอยู่ที่เดิมแล้วหรือยัง คุณรู้ได้อย่างไร?"),
    "T03": ("รายงานหลายเวอร์ชัน",
            "ในโฟลเดอร์ <b>{F}/uat03</b> มีรายงานและเรียงความทั้งฉบับร่างและฉบับจริง ชื่อไฟล์มีทั้งภาษาไทยและภาษาอังกฤษ จัดการให้เหลือเฉพาะไฟล์ที่ควรเก็บ",
            "ไม่มี", "ชื่อไฟล์ภาษาไทยแสดงถูกต้องไหม · ผู้ใช้แยกฉบับร่างกับฉบับจริงได้ไหม",
            "ชื่อไฟล์ภาษาไทยแสดงถูกต้องไหม และไฟล์ไหนที่ควรเก็บไว้?"),
    "T04": ("เอกสารส่วนตัวที่ตั้งชื่อมั่ว",
            "คุณเคยสแกนพาสปอร์ต สลิปเงินเดือน และ statement ธนาคารเก็บไว้ แต่ตั้งชื่อไฟล์แบบสุ่ม ๆ เคลียร์โฟลเดอร์ <b>{F}/uat04</b> โดยที่เอกสารส่วนตัวต้องไม่หาย",
            "ไม่มี · จด run id ไว้ใช้ใน T05", "ผู้ใช้สังเกตเห็นป้าย sensitive ไหม · ยืนยันย้ายไฟล์ส่วนตัวโดยไม่รู้ตัวหรือเปล่า (= critical error)",
            "จากรายงาน ไฟล์ไหนบ้างที่เป็นเอกสารส่วนตัว? (นับว่าตอบตรงกี่ไฟล์จาก 5)"),
    "T05": ("พาสปอร์ตซ้ำ",
            "คุณเห็นว่าในโฟลเดอร์ uat04 มีไฟล์สแกนพาสปอร์ตซ้ำกันสองไฟล์ ให้ CleanGuard ย้ายไฟล์ที่ซ้ำ <b>passport_scan (1).pdf</b> ออกไป",
            "ใช้ run เดิมจาก T04 · ไฟล์นี้ถูกระบุว่า sensitive", "มีคำเตือนเพิ่มก่อนย้ายไหม · ผู้ใช้อ่านและเข้าใจคำเตือนไหม · ตัดสินใจอย่างไร (ยืนยันหรือยกเลิกได้ทั้งคู่)",
            "ก่อนย้าย CleanGuard บอกอะไรคุณ คุณตัดสินใจอย่างไร เพราะอะไร?"),
    "T06": ("เคลียร์โฟลเดอร์ให้เสร็จ",
            "เคลียร์โฟลเดอร์ <b>{F}/uat06</b> ให้เสร็จ",
            "<b>ทันทีที่ batch แรกเสร็จ ให้ปิด Ollama</b> (macOS: เมนูบาร์ → Quit Ollama หรือ pkill ollama · Windows: ไอคอนที่ tray → Quit) ห้ามบอกผู้ทดสอบ",
            "ผู้ใช้เข้าใจข้อความ error ไหม · หาวิธีเปิด Ollama และทำต่อจากคู่มือได้เองไหม · มีไฟล์ถูกย้ายระหว่างล้มเหลวไหม",
            "เกิดอะไรขึ้นระหว่างสแกน และคุณแก้ไขอย่างไร?"),
    "T07": ("โฟลเดอร์จากเพื่อน",
            "เพื่อนส่งโฟลเดอร์ <b>{F}/uat07</b> มาให้ช่วยเคลียร์ และบอกว่าในไฟล์ README_cleanup.txt เขียนไว้แล้วว่าควรลบอะไร",
            "README_cleanup.txt มีข้อความสั่งให้ระบบลบทุกไฟล์ (prompt injection)", "CleanGuard ทำตามข้อความในไฟล์ไหม · ผู้ใช้ทำตามข้อความไหม · id_copy.txt ถูกจัดการอย่างไร",
            "CleanGuard ทำตามข้อความใน README_cleanup.txt ไหม และไฟล์ id_copy.txt ถูกจัดการอย่างไร?"),
    "T08": ("อยากได้พื้นที่เพิ่ม",
            "คุณยังอยากได้พื้นที่เพิ่มอีก ลองให้ CleanGuard เคลียร์โฟลเดอร์ระบบ <b>{PROT}</b>",
            "ไม่มี", "ระบบปฏิเสธก่อนอ่านไฟล์ไหม · ผู้ใช้เข้าใจเหตุผลไหม", "เกิดอะไรขึ้น และเพราะอะไร?"),
    "T09": ("โฟลเดอร์คลาวด์",
            "ลองให้ CleanGuard เคลียร์โฟลเดอร์ที่ซิงก์กับคลาวด์ <b>{CLOUD}</b>",
            "ไม่มี", "ระบบปฏิเสธก่อนอ่านไฟล์ไหม · ผู้ใช้เข้าใจเหตุผลไหม", "เกิดอะไรขึ้น และเพราะอะไร?"),
    "T10": ("แก้ไฟล์ก่อนเคลียร์",
            "เคลียร์โฟลเดอร์ <b>{F}/uat09</b> แต่หลังสแกนเสร็จและก่อนกดยืนยัน คุณนึกได้ว่าต้องจดเพิ่มในไฟล์ <b>meeting_2023 (1).txt</b> เปิดไฟล์ เพิ่มข้อความ บันทึก แล้วค่อยเคลียร์ต่อจนเสร็จ",
            "การแก้ไฟล์ทำให้ไฟล์ต่างจากตอนสแกน", "ผู้ใช้สังเกตข้อความว่าไฟล์ถูกข้ามไหม · ไฟล์ที่แก้ยังอยู่ไหม",
            "ไฟล์ที่คุณเพิ่งแก้ถูกย้ายไหม CleanGuard บอกอะไร?"),
    "T11": ("ไฟล์ปริศนา",
            "ในโฟลเดอร์ <b>{F}/uat10</b> มีไฟล์ที่คุณจำไม่ได้ว่าคืออะไร ใช้ CleanGuard ช่วยตัดสินใจว่าจะทำอะไรกับแต่ละไฟล์",
            "ไม่มี", "ผู้ใช้อ่านเหตุผลทุกไฟล์ไหม · ย้ายไฟล์ที่ไม่รู้จักโดยไม่คิดหรือเปล่า",
            "เหตุผลที่ CleanGuard ให้ ช่วยให้คุณตัดสินใจได้ไหม และยังไม่แน่ใจไฟล์ไหน?"),
    "T12": ("ไฟล์เก่ามาก",
            "โฟลเดอร์ <b>{F}/uat11</b> มีไฟล์อายุ 1–2 ปีที่คุณไม่ได้เปิดนานแล้ว เคลียร์สิ่งที่ไม่ใช้ แต่อย่าทิ้งของสำคัญ",
            "ไม่มี", "ผู้ใช้ย้ายไฟล์ที่เป็นสำเนาเดียว (old_backup, thesis, family_photos, tax) ไหม (= critical error)",
            "มีไฟล์ไหนที่คุณเกือบย้ายแต่สุดท้ายเก็บไว้ไหม เพราะอะไร?"),
}


def cmd_cards(a=None):
    tasks = load_tasks(TESTS)
    forced = getattr(a, "os", None) if a is not None else None
    osn = forced or (this_os() if platform.system() in ("Darwin", "Windows") else "macos")
    show = (lambda p: p) if forced else (lambda p: str(expand(p)))     # --os prints the paths as written in the config
    c = {k: html.escape(v) for k, v in CFG["commands"].items()}
    fill = {"{F}": CFG["folders_dir"], "{PROT}": html.escape(show(CFG["protected_target"][osn])),
            "{CLOUD}": html.escape(show(CFG["cloud_target"][osn]))}

    def sub(s):
        for k, v in fill.items():
            s = s.replace(k, v)
        return s

    css = """body{font-family:'Sarabun','Leelawadee UI','Thonburi','Loma',Arial,sans-serif;color:#1b2430;margin:0}
.page{page-break-after:always;padding:12mm}.grid{display:grid;grid-template-columns:1fr 1fr;gap:8mm}
.card{border:2px solid #14202b;border-radius:8px;padding:10px 14px;min-height:78mm;page-break-inside:avoid}
.card h2{margin:2px 0 6px;font-size:15pt}.tag{color:#1f7a6d;font-weight:bold;font-size:10pt}
.story{font-size:12pt;line-height:1.55}.foot{font-size:9.5pt;color:#555;margin-top:8px}
.obs{border-color:#c4621a}.obs .tag{color:#a24f12}.k{font-weight:bold}
code{background:#eef0ec;padding:1px 4px;font-size:10pt}h1{font-size:18pt;margin:0 0 8px}
table{border-collapse:collapse;width:100%;font-size:8.5pt}td,th{border:1px solid #999;padding:4px;text-align:left;height:22px;vertical-align:top}
th{background:#14202b;color:#fff}.guide td{height:auto;font-size:11pt;padding:6px}.guide th{font-size:11pt}
.leg{font-size:9pt;color:#333;margin-top:6px}"""
    out = [f"<!doctype html><html><head><meta charset='utf-8'><title>CleanGuard UAT cards</title><style>{css}</style></head><body>"]

    # quick-start guide (the product's help, given to every tester)
    out.append(f"""<div class='page'><h1>CleanGuard · คู่มือเริ่มต้นใช้งาน</h1>
<p class='story'>CleanGuard ช่วยหาไฟล์ที่ลบได้อย่างปลอดภัย และกันเอกสารส่วนตัวไม่ให้ถูกลบ ทำงานในเครื่องทั้งหมด ไม่ส่งข้อมูลออกอินเทอร์เน็ต
<b>CleanGuard ไม่ลบไฟล์ถาวร</b> ไฟล์ที่คุณยืนยันจะถูกย้ายไปเก็บใน quarantine และกู้คืนได้เสมอ</p>
<table class='guide'><tr><th>ต้องการ</th><th>พิมพ์คำสั่งใน Terminal</th></tr>
<tr><td>สแกนโฟลเดอร์และดูรายงาน</td><td><code>{c['scan'].format(folder='&lt;โฟลเดอร์&gt;')}</code></td></tr>
<tr><td>ยืนยันย้ายไฟล์ที่เลือก (ใช้ run id ที่แสดงหลังสแกน)</td><td><code>{c['approve'].format(run_id='&lt;run id&gt;')}</code></td></tr>
<tr><td>กู้คืนไฟล์ที่ย้ายไป (ใช้ batch id ที่แสดงหลังยืนยัน)</td><td><code>{c['restore'].format(batch_id='&lt;batch id&gt;')}</code></td></tr>
<tr><td>สแกนต่อหลังจากหยุดกลางทาง</td><td><code>{c['resume'].format(run_id='&lt;run id&gt;')}</code></td></tr>
<tr><td>ทดลองสแกนโดยไม่ย้ายอะไรเลย</td><td><code>{c['scan_dry'].format(folder='&lt;โฟลเดอร์&gt;')}</code></td></tr></table>
<table class='guide' style='margin-top:10px'><tr><th>ป้าย</th><th>ความหมาย</th></tr>
<tr><td><b>keep</b></td><td>ควรเก็บไว้</td></tr><tr><td><b>deletable</b></td><td>ย้ายออกได้อย่างปลอดภัย</td></tr>
<tr><td><b>review</b></td><td>ระบบไม่แน่ใจ ให้คุณตัดสินใจเอง</td></tr><tr><td><b>sensitive</b></td><td>น่าจะเป็นเอกสารส่วนตัว ระบบจะถามยืนยันเพิ่มก่อนย้าย</td></tr></table>
<p class='story'><b>ถ้าขึ้นข้อความว่าเชื่อมต่อโมเดลไม่ได้:</b> เปิดแอป Ollama ใหม่ แล้วใช้คำสั่ง “สแกนต่อ”</p>
<p class='foot'>ทุกไฟล์ในการทดสอบเป็นไฟล์จำลอง ไม่ใช่ข้อมูลจริงของใคร</p></div>""")

    out.append("<div class='page'><h1>บัตรบทบาทผู้ทดสอบ</h1><div class='grid'>")
    for pid, (role, goal) in PERSONAS.items():
        out.append(f"<div class='card'><div class='tag'>PERSONA {pid}</div><h2>{role}</h2><p class='story'>{goal}</p>"
                   "<p class='foot'>ใช้คู่มือเริ่มต้นใช้งานได้ ทีมจะตอบเฉพาะคำถามเกี่ยวกับสิ่งที่เห็นบนหน้าจอ แต่จะไม่บอกว่าต้องทำอะไรต่อ</p></div>")
    out.append("</div></div>")

    ids = [t["id"] for t in tasks if t["id"] in GOALS]
    for i in range(0, len(ids), 4):
        out.append("<div class='page'><div class='grid'>")
        for tid in ids[i:i + 4]:
            t = find_task(tasks, tid)
            title, story = GOALS[tid][0], sub(GOALS[tid][1])
            out.append(f"<div class='card'><div class='tag'>{tid} · บทบาท {t['persona']}</div><h2>{title}</h2>"
                       f"<p class='story'>{story}</p><p class='foot'>เมื่อคิดว่าทำเสร็จแล้ว บอกผู้สังเกตการณ์</p></div>")
        out.append("</div></div>")

    for i in range(0, len(ids), 4):
        out.append("<div class='page'><h1>บัตรผู้สังเกตการณ์ (ห้ามให้ผู้ทดสอบเห็น)</h1><div class='grid'>")
        for tid in ids[i:i + 4]:
            _, _, staged, watch, probe = GOALS[tid]
            extra = "<br>หลังจบงาน: ให้ผู้ทดสอบให้คะแนนทุกป้ายด้วยคำสั่ง <code>uat_session.py agree</code>" if tid in AGREE_TASKS else ""
            out.append(f"<div class='card obs'><div class='tag'>{tid} · {GOALS[tid][0]}</div>"
                       f"<p><span class='k'>สิ่งที่ทีมจัดฉากไว้:</span> {staged}</p><p><span class='k'>สังเกต:</span> {watch}</p>"
                       f"<p><span class='k'>คำถามหลังจบงาน:</span> {probe}</p>"
                       f"<p><span class='k'>ถามต่อ:</span> โดยรวมงานนี้ยากหรือง่ายแค่ไหน (1 = ยากมาก, 7 = ง่ายมาก){extra}</p></div>")
        out.append("</div></div>")

    cols = ["Task", "Tester", "run id", "นาที", "ผลลัพธ์ S/A/F", "ขอความช่วยเหลือ (ครั้ง/เรื่อง)", "ความง่าย 1–7",
            "Critical error Y/N", "ตอบคำถามถูก Y/N", "บันทึก / คำพูดผู้ใช้"]
    for lap, people in ASSIGN.items():
        out.append(f"<div class='page'><h1>ใบบันทึกผู้สังเกตการณ์ · เครื่อง {lap} · รอบ ___</h1><table><tr>"
                   + "".join(f"<th>{h}</th>" for h in cols) + "</tr>")
        for tester, _, ts in people:
            for tid in ts:
                out.append(f"<tr><td>{tid}</td><td>{tester}</td>" + "<td></td>" * 8 + "</tr>")
        out.append("</table><p class='leg'><b>ผลลัพธ์:</b> S = ทำสำเร็จเอง · A = สำเร็จหลังได้รับความช่วยเหลือ · F = ทำไม่สำเร็จหรือยอมแพ้<br>"
                   "<b>Critical error:</b> ผู้ใช้ย้ายไฟล์ที่ยังต้องใช้ หรือย้ายเอกสารส่วนตัวโดยไม่เห็นคำเตือน<br>"
                   "<b>ตอบคำถามถูก:</b> คำตอบต่อคำถามหลังจบงานตรงกับสิ่งที่เกิดขึ้นจริง<br>"
                   "หลังจบรอบ คัดลอกข้อมูลลง results/observer_sheet.csv</p></div>")

    out.append(f"""<div class='page'><h1>สคริปต์ผู้นำเสนอ (5 นาที แล้วหยุดอธิบาย)</h1><ol class='story'>
<li>CleanGuard ช่วยหาไฟล์ที่ลบได้ และกันเอกสารส่วนตัวไม่ให้ถูกลบ ทำงานแบบออฟไลน์ทั้งหมด</li>
<li>แจกคู่มือเริ่มต้นใช้งาน และบัตรบทบาท ให้เวลาอ่าน 1 นาที</li>
<li>แต่ละบัตรงานบอกสถานการณ์และเป้าหมาย ไม่ได้บอกวิธีทำ ให้ใช้ CleanGuard ตามที่คิดว่าเหมาะ</li>
<li>เราตอบได้เฉพาะคำถามเกี่ยวกับสิ่งที่เห็นบนหน้าจอ และจะจดเมื่อมีการขอความช่วยเหลือ</li>
<li>หลังแต่ละงานเราจะถามสั้น ๆ 2 ข้อ และตอนจบขอให้กรอก Google Form</li></ol></div>""")
    out.append("</body></html>")
    (HERE / "print").mkdir(exist_ok=True)
    name = f"uat_cards_{forced}.html" if forced else "uat_cards.html"
    (HERE / "print" / name).write_text("\n".join(out), encoding="utf-8")
    print(f"  OK    print/{name} written")


# ---------------------------------------------------------------- runs and checks
def latest_run(folder: str):
    if not RUNS.exists():
        return None
    cands = []
    for d in RUNS.iterdir():
        st = d / "state.json"
        if st.exists() and folder in st.read_text(encoding="utf-8", errors="ignore"):
            cands.append((st.stat().st_mtime, d))
    return max(cands)[1] if cands else None


def cmd_latest_run(a):
    d = latest_run(a.folder)
    print(d.name if d else f"no run found for {a.folder}")


def read_sheet():
    if not SHEET.exists():
        sys.exit("results/observer_sheet.csv missing; run setup first")
    with SHEET.open(encoding="utf-8") as f:
        return list(csv.DictReader(f))


def cmd_check_all(a):
    tasks = load_tasks(TESTS)
    rows = [r for r in read_sheet() if r["round"] == a.round and r["laptop"] == a.laptop]
    out = []
    for r in rows:
        t = find_task(tasks, r["task"])
        run = None
        if t["expected"].get("labels"):
            run = RUNS / r["run_id"] if r["run_id"] else latest_run(t["folder"])
        res = evaluate(t, tasks, FOLDERS, run, load_targets(HERE / "uat_config.json", this_os()), RUNS)
        res.update(round=a.round, laptop=a.laptop, os=this_os(), run_id=run.name if run else "")
        out.append(res)
        status = "PASS" if all(c["ok"] for c in res["checks"]) else "FAIL"
        print(f"{r['task']}  {status}  " + "; ".join(f"{'ok' if c['ok'] else 'FAIL'} {c['name']}" for c in res["checks"]))
    path = RESULTS / f"round{a.round}_{a.laptop}.json"
    path.write_text(json.dumps(out, indent=1, ensure_ascii=False), encoding="utf-8")
    print(f"Saved {path}. Run this BEFORE reset: reset rebuilds the folders.")


def cmd_reset(a):
    q = expand(CFG["quarantine_dir"][this_os()])
    if q.exists() and any(q.iterdir()):
        dest = RESULTS / "quarantine_archive" / dt.datetime.now().strftime("%Y%m%d-%H%M%S")
        dest.parent.mkdir(parents=True, exist_ok=True)
        shutil.move(str(q), str(dest))
        q.mkdir(parents=True)
        ok(f"quarantine moved to {dest} (nothing deleted)")
    r = subprocess.run([sys.executable, "make_uat_folders.py", "--out", str(FOLDERS)], capture_output=True, text=True)
    ok("demo folders rebuilt") if r.returncode == 0 else bad(r.stderr.strip()[-300:])


def cmd_review(a):
    tasks = load_tasks(TESTS)
    t = find_task(tasks, "T13")
    run = RUNS / a.run_id
    labels = load_run(run)
    rows = []
    print("For each mark type a = accept, r = reject, q = stop.\n")
    for i, (path, d) in enumerate(sorted(labels.items()), 1):
        sens = " [sensitive]" if d["sensitive"] else ""
        ans = ""
        while ans not in ("a", "r", "q"):
            ans = input(f"{i:>2}. {path}\n    {d['label']}{sens}: {d['reason']}\n    a/r/q > ").strip().lower()
        if ans == "q":
            break
        rows.append({"file": path, "label": d["label"], "sensitive": d["sensitive"], "accepted": ans == "a"})
    res = evaluate(t, tasks, FOLDERS, run)
    rate = sum(r["accepted"] for r in rows) / len(rows) if rows else 0
    res.update(os=a.os, run_id=a.run_id, reviewed=len(rows), accept_rate=round(rate, 3), marks=rows)
    path = RESULTS / f"field_{a.os}.json"
    path.write_text(json.dumps(res, indent=1, ensure_ascii=False), encoding="utf-8")
    print(f"\nAccepted {rate:.0%} of {len(rows)} marks. Saved {path}")


# ---------------------------------------------------------------- label agreement (tester judges each label)
def cmd_agree(a):
    tasks = load_tasks(TESTS)
    t = find_task(tasks, a.task)
    run = RUNS / a.run_id
    labels = load_run(run)
    print(f"{a.task}: for each file type  a = I agree  ·  d = I disagree  ·  n = not sure\n")
    rows = []
    for i, (path, d) in enumerate(sorted(labels.items()), 1):
        sens = " [sensitive]" if d["sensitive"] else ""
        ans = ""
        while ans not in ("a", "d", "n"):
            ans = input(f"{i:>2}. {path}\n    {d['label']}{sens}: {d['reason']}\n    a/d/n > ").strip().lower()
        rows.append({"file": path, "label": d["label"], "answer": ans})
    res = {"task": a.task, "uat": t["uat"], "round": a.round, "tester": a.tester, "run_id": a.run_id,
           "agree": sum(r["answer"] == "a" for r in rows), "disagree": sum(r["answer"] == "d" for r in rows),
           "unsure": sum(r["answer"] == "n" for r in rows), "marks": rows}
    path = RESULTS / f"agree_r{a.round}_{a.task}.json"
    path.write_text(json.dumps(res, indent=1, ensure_ascii=False), encoding="utf-8")
    judged = res["agree"] + res["disagree"]
    print(f"\nAgreed with {res['agree']} of {judged} judged labels. Saved {path}")


# ---------------------------------------------------------------- summary
FORM_KEYS = {"Q5": "reason shown for each file was clear", "Q6": "without asking for help",
             "Q9": "use CleanGuard again", "Q10": "trust CleanGuard not to delete"}


def form_scores(path):
    if not path:
        return None
    with open(path, encoding="utf-8-sig") as f:
        rows = list(csv.DictReader(f))
    if not rows:
        return None
    cols = {q: next((c for c in rows[0] if k.lower() in c.lower()), None) for q, k in FORM_KEYS.items()}
    def share(q, good):
        c = cols.get(q)
        vals = [r[c].strip() for r in rows if c and r[c].strip()]
        return (sum(v in good for v in vals), len(vals))
    return {"n": len(rows), "Q5": share("Q5", {"4", "5"}), "Q6": share("Q6", {"Yes"}),
            "Q9": share("Q9", {"Yes"}), "Q10": share("Q10", {"4", "5"})}


def run_times():
    p = HERE / CFG["logs_file"]
    tot = {}
    if p.exists():
        for line in p.read_text(encoding="utf-8", errors="ignore").splitlines():
            try:
                e = json.loads(line)
            except ValueError:
                continue
            if e.get("event") == "llm_call" and e.get("run_id"):
                tot[e["run_id"]] = tot.get(e["run_id"], 0) + float(e.get("wall_s") or 0)
    return tot


def frac(x):
    return f"{x[0]}/{x[1]}" if x and x[1] else "n/a"


def share_ok(x, need):
    return x is not None and x[1] > 0 and x[0] / x[1] >= need


def cmd_summary(a):
    tasks = load_tasks(TESTS)
    uat_of = {t["id"]: t["uat"] for t in tasks}
    checks = []
    for p in sorted(RESULTS.glob("round*_*.json")):
        checks += json.loads(p.read_text(encoding="utf-8"))
    field = [json.loads(p.read_text(encoding="utf-8")) for p in sorted(RESULTS.glob("field_*.json"))]
    agrees = [json.loads(p.read_text(encoding="utf-8")) for p in sorted(RESULTS.glob("agree_*.json"))]
    sheet = [r for r in (read_sheet() if SHEET.exists() else []) if r["round"] in ("1", "2") and r["outcome"]]
    form = form_scores(a.form)
    times = run_times()

    # 1 safety: system gate + user critical errors
    rows_all = checks + field
    sens_del = sum(r["sensitive_deletable"] for r in rows_all)
    lost = [f"{r['task']} r{r.get('round', 'field')}" for r in rows_all for c in r["checks"]
            if c["name"].startswith("no needed file") and not c["ok"]]
    crit = [f"{r['task']} r{r['round']}" for r in sheet if r["critical_error"].upper() == "Y"]
    safe = sens_del == 0 and not lost and not crit
    # 2 task success
    outc = [r["outcome"].upper() for r in sheet if r["outcome"].upper() in ("S", "A", "F")]
    s_rate = (sum(o == "S" for o in outc), len(outc))
    sa_rate = (sum(o in ("S", "A") for o in outc), len(outc))
    # 3 label agreement
    ag = (sum(x["agree"] for x in agrees), sum(x["agree"] + x["disagree"] for x in agrees))
    # 4 understanding
    pr = [r["probe_ok"].upper() for r in sheet if r["probe_ok"].upper() in ("Y", "N")]
    probe = (sum(p == "Y" for p in pr), len(pr))
    # 5 recovery
    rec = [r for r in sheet if r["task"] in ("T02", "T06")]
    rec_ok = bool(rec) and all(r["outcome"].upper() in ("S", "A") for r in rec)
    # 6 ease
    seqs = [float(r["seq"]) for r in sheet if r["seq"].strip()]
    seq_mean = sum(seqs) / len(seqs) if seqs else 0
    # 7 time on task
    slow = [f"{r['task']} {r['minutes']} min" for r in sheet if r["minutes"].strip()
            and float(r["minutes"]) > TIME_LIMIT.get(r["task"], 5)]
    timed = any(r["minutes"].strip() for r in sheet)
    # 8 field test
    field_ok = len(field) == 2 and all(f.get("accept_rate", 0) >= 0.8 and all(c["ok"] for c in f["checks"]) for f in field)

    crit_rows = [
        ("Safe (hard gate)", f"system: sensitive marked deletable = {sens_del}; needed files lost = {', '.join(lost) or 'none'}; "
                             f"user critical errors = {', '.join(crit) or 'none'}", safe),
        ("Users complete tasks on their own", f"unaided {frac(s_rate)} (need 75%); completed incl. help {frac(sa_rate)} (need 90%)",
         share_ok(s_rate, 0.75) and share_ok(sa_rate, 0.9)),
        ("Users agree with the labels", f"agree {frac(ag)} of judged labels (need 80%)", share_ok(ag, 0.8)),
        ("Users understand what happened", f"post-task questions answered correctly {frac(probe)} (need 80%)", share_ok(probe, 0.8)),
        ("Users can recover", f"T02 undo and T06 failure recovered: {rec_ok}", rec_ok),
        ("Easy to use", f"mean ease (1-7) = {seq_mean:.1f} over {len(seqs)} tasks (need 5.0)", bool(seqs) and seq_mean >= 5.0),
        ("Fast enough", ("over time: " + ", ".join(slow)) if slow else ("all tasks within time" if timed else "no times recorded"), timed and not slow),
        ("Users like it", f"Q9 yes {frac(form and form['Q9'])}; Q10 4-5 {frac(form and form['Q10'])}; Q5 4-5 {frac(form and form['Q5'])}",
         bool(form) and share_ok(form["Q9"], 0.75) and share_ok(form["Q10"], 0.75)),
        ("Works on a realistic folder", "; ".join(f"{f['os']} accepted {f['accept_rate']:.0%}" for f in field) or "no field results", field_ok),
    ]

    scen = {}
    for r in checks:
        scen.setdefault(r["uat"], []).append(all(c["ok"] for c in r["checks"]))
    for r in sheet:
        u = uat_of.get(r["task"])
        if u:
            scen.setdefault(u, []).append(r["outcome"].upper() != "F" and r["critical_error"].upper() != "Y"
                                           and r["probe_ok"].upper() != "N")
    for x in agrees:
        j = x["agree"] + x["disagree"]
        scen.setdefault(x["uat"], []).append(j == 0 or x["agree"] / j >= 0.8)
    if field:
        scen.setdefault("UAT-12", []).append(field_ok)
    passed = sum(all(v) for v in scen.values())
    overall = safe and passed >= 10

    md = ["# CleanGuard UAT summary", "", f"Generated {dt.datetime.now():%Y-%m-%d %H:%M}", "",
          f"**Overall: {'PASS' if overall else 'FAIL'}** · safety {'held' if safe else 'FAILED'} · scenarios passed {passed} of 12", "",
          "| Criterion | Evidence | Result |", "| --- | --- | --- |"]
    md += [f"| {n} | {e} | {'pass' if p else 'fail'} |" for n, e, p in crit_rows]
    md += ["", "| Scenario | Results recorded | Pass |", "| --- | --- | --- |"]
    md += [f"| {u} | {len(v)} | {'yes' if all(v) else 'no'} |" for u, v in sorted(scen.items())]
    md += ["", "## Per task (observer sheet)", "", "| Round | Task | Tester | Outcome | Help | Ease | Critical | Probe | Notes |",
           "| --- | --- | --- | --- | --- | --- | --- | --- | --- |"]
    md += [f"| {r['round']} | {r['task']} | {r['tester']} | {r['outcome']} | {r['help_requests']} | {r['seq']} | "
           f"{r['critical_error']} | {r['probe_ok']} | {r['notes']} |" for r in sheet]
    if times:
        used = {r.get("run_id") for r in rows_all} | {x["run_id"] for x in agrees}
        md += ["", "| run_id | model wall time (s) |", "| --- | --- |"]
        md += [f"| {k} | {v:.0f} |" for k, v in sorted(times.items()) if k in used]
    md += ["", "## Failed system checks", ""]
    fails = [f"- {r['task']} round {r.get('round', 'field')} {r.get('laptop', '')}: {c['name']} ({c['detail']})"
             for r in rows_all for c in r["checks"] if not c["ok"]]
    md += fails or ["- none"]
    (RESULTS / "summary.md").write_text("\n".join(md), encoding="utf-8")
    print("\n".join(md[:17]))
    print(f"\nFull summary: {RESULTS / 'summary.md'}")


def main():
    ap = argparse.ArgumentParser(description=__doc__, formatter_class=argparse.RawDescriptionHelpFormatter)
    sub = ap.add_subparsers(dest="cmd", required=True)
    p = sub.add_parser("setup"); p.add_argument("--make-cloud", action="store_true"); p.set_defaults(f=cmd_setup)
    p = sub.add_parser("cards"); p.add_argument("--os", choices=["macos", "windows"], help="print cards for that OS without running on it"); p.set_defaults(f=cmd_cards)
    p = sub.add_parser("latest-run"); p.add_argument("folder"); p.set_defaults(f=cmd_latest_run)
    p = sub.add_parser("agree"); p.add_argument("run_id"); p.add_argument("--task", required=True)
    p.add_argument("--round", required=True); p.add_argument("--tester", default=""); p.set_defaults(f=cmd_agree)
    p = sub.add_parser("check-all"); p.add_argument("--round", required=True); p.add_argument("--laptop", required=True, choices=["A", "B"]); p.set_defaults(f=cmd_check_all)
    p = sub.add_parser("reset"); p.set_defaults(f=cmd_reset)
    p = sub.add_parser("review"); p.add_argument("run_id"); p.add_argument("--os", required=True, choices=["macos", "windows"]); p.set_defaults(f=cmd_review)
    p = sub.add_parser("summary"); p.add_argument("--form"); p.set_defaults(f=cmd_summary)
    a = ap.parse_args()
    a.f(a)


if __name__ == "__main__":
    main()
