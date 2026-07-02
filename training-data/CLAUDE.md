# CLAUDE.md — training-data/

Context สำหรับ AI agent ที่มาทำงานต่อในโฟลเดอร์นี้ (portable — อาจอยู่ใน repo แยกจาก Constistant หลัก)

> ⚠️ **อ่าน [rule_of_tune.md](rule_of_tune.md) ก่อนเริ่มงานทุกครั้ง — ไม่มีข้อยกเว้น**
> กฎห้ามแตะ raw JSON ของ raw data ก่อนได้รับอนุญาต + **การกระทำใดๆ ที่ส่งผลต่อการทูนนิ่งต้องมีการเตือนเสมอ** (ไม่ใช่แค่แก้ raw JSON ตรงๆ — รวมถึงแก้ script/schema ที่กระทบข้อมูลปลายทาง) + บันทึก format JSON ที่ใช้ทูนจริงไว้อ้างอิง

## นี่คืออะไร

Pipeline สร้าง **fine-tuning dataset** สำหรับโมเดล Qwen-VL ให้อ่านแบบก่อสร้าง RC (คอนกรีตเสริมเหล็ก) ของไทยได้แม่นขึ้น
Input: PDF แบบบ้าน (rasterize เป็น PNG ต่อหน้าไว้แล้ว) → Output: JSON structured data ต่อหน้า (element/dimension/rebar spec)
เป้าหมายปลายทาง: เก็บพอแล้วเอาไป fine-tune (ตอนนี้ยังอยู่ขั้น pre-labeling/dataset generation ไม่ใช่ training)

**Setup ก่อนรัน:** ดู [SETUP.md](SETUP.md) — ต้องมี `.env.local` (QWEN_API_KEY/HOST) และ `pip install -r requirements.txt`

## Architecture — 2 generation ของ logic (สำคัญ: ใช้ generation ล่าสุด)

### Generation ปัจจุบัน (ใช้จริง) — `run_pipeline.py` + `build_document_map.py`

```
Stage 0 (build_document_map.py) — อ่านหน้าสารบัญ (TOC) 1 ครั้ง
  → ได้ตาราง: sheet-code range (S-01..08, A-01..15, ...) + เลขหน้าใน doc ต่อ discipline
  → หา offset ระหว่าง "เลขหน้าที่สารบัญบอก" กับ "ไฟล์ PNG จริง" โดยอ่าน sheet_code จาก anchor page 1-2 หน้า
  → LOCK เป็น document map: ทุกหน้า PNG → discipline (structural/architectural/sanitary/electrical/...)
  → เขียนลง raw/image/<house>/qwen-output/_document_map.json

Step 2 (run_pipeline.py) — ไล่ทุกหน้าตาม map:
  discipline == structural  → Stage B (unified extractor, 1 call/หน้า, model=qwen-vl-max)
                               อ่าน title-block sheet_name เอง → เลือก pattern (plan/schedule/section/notes)
                               → extract ตาม pattern นั้น
  discipline อื่น            → skip (ตอนนี้ scope = structural only)
```

**ทำไมต้อง Stage 0 ก่อน (อย่ากลับไป per-page classify ทุกหน้า):**
เคยลองให้ VLM classify ทีละหน้าจาก geometry (dimension line/hatching) — **หลอนหนัก** เช่น หน้าแบบขยายบันได (architectural ล้วน) VLM ยืนยัน "เห็น rebar dots" (มั่ว) แล้วจัดเป็น `section_detail` conf 0.95 — **confidence ของโมเดลใช้คัดกรองไม่ได้เลย** (ติดเพดาน ~0.95 ทั้งตอนถูกและผิด)

**สิ่งที่พิสูจน์แล้วว่าเชื่อถือได้แม้ตอน VLM หลอน:** มันอ่าน **sheet_code** จาก title block ถูกเสมอ (เช่น "A-11") แม้จะหลอนเรื่อง geometry ข้างๆ กัน → เปลี่ยนมาใช้ **สารบัญ + sheet-code เป็นตัวกำหนด discipline แบบ deterministic** แทนการให้ VLM เดา geometry เอง แก้ hallucination ได้เกือบหมด และประหยัด token กว่ามาก (2-3 call routing ทั้งเอกสาร แทน 61 call classify)

### Generation เก่ากว่า (fallback, ใช้เมื่อไม่มีสารบัญ) — `analyze_folder.py`
Per-page classify (Stage A) → route → extract (Stage B1/B2 แยกตาม sheet_type) เป็น pattern เดิมก่อนจะรู้ว่า sheet-code routing ดีกว่า **ยังอยู่ในโค้ดเผื่อเอกสารที่ไม่มีสารบัญ** แต่ควรใช้ `run_pipeline.py` เป็นค่าเริ่มต้นเสมอถ้ามีสารบัญ

## Layer สำรอง: PDF text layer (ยังไม่เคยเจอไฟล์ที่มีจริง)

ทั้ง 2 สคริปต์เช็ค PDF text layer ก่อน (ผ่าน PyMuPDF/`fitz`) — ถ้ามี text จะฉีดเป็น "grounding block" เข้า prompt (บอกโมเดลว่าตัวอักษร/รหัสให้เชื่อ text ไม่ต้องอ่านจากภาพ) แต่ **PDF ทุกไฟล์ที่เจอในโปรเจกต์นี้เป็น vector-outline (ตัวอักษรถูกวาดเป็นเส้น) → 0 text เสมอ** ดังนั้นกิ่งนี้ยัง**ไม่เคยถูกทดสอบจริง** ถ้าเจอ PDF ที่มี text layer จริง ให้ทดสอบกิ่งนี้ก่อนเชื่อผล

## บทเรียนสำคัญ (อย่าพลาดซ้ำ)

1. **VLM หลอน geometry แบบมั่นใจสูง** — dimension line + hatching อย่างเดียวไม่ใช่หลักฐานว่าเป็น structural (ดูหัวข้อ Architecture ด้านบน) ใช้ sheet-code/สารบัญตัดสิน ไม่ใช้ VLM geometry classify เป็นหลัก

2. **ตัวเลขเหล็กเส้นเล็กๆ อ่านผิดบ่อย** — ทดสอบจริงพบ Ø12 ถูกอ่านเป็น "DB23" (ไม่มีขนาดนี้ในมาตรฐานจริง — สัญญาณเตือนว่าเป็นค่าหลอน), stirrup Ø9 อ่านเป็น Ø6, dense stirrup zone (`@0.10 ช่วง 1.0m แรก`) มักถูกมองข้าม → **element_id/มิติหน้าตัด/จำนวนเหล็กหลัก มักถูก แต่ค่า spacing/ขนาดเหล็กปลอกละเอียดต้องให้คนตรวจก่อนเชื่อ**

3. **`confidence_score` จากโมเดลใช้ตัดสินเดี่ยวๆ ไม่ได้** — ต้องมี cross-check (sheet-code ตรงกับ TOC ไหม, self-consistency ถ้ายิงซ้ำ) หรือรอ human review เท่านั้น

4. **BOQ/schedule table ที่ไม่ใช่ rebar schedule ก็ยังมีตาราง** — เคยเจอหน้า BOQ (บัญชีปริมาณงาน) ถูกยัดเป็น `schedule_table` เพราะ VLM เห็นว่ามันเป็นตาราง ทั้งที่ไม่เกี่ยวกับโครงสร้างเลย → เหตุผลอีกข้อที่ต้อง route จากสารบัญ ไม่ใช่ให้ VLM เดาจาก geometry ของตาราง

5. **Model เลือกตาม task**: `qwen-vl-plus` ถูกกว่า ใช้กับ classify/สารบัญ/notes (ข้อความล้วน); `qwen-vl-max` แม่นกว่า ใช้เฉพาะ extraction ที่ต้องอ่าน geometry/ตัวเลขละเอียด (structural elements)

## สิ่งที่ยังไม่ได้ทำ (ทำต่อได้)

- **Label Studio review flow** — มี 2 แบบขนานกันตอนนี้ (ดูหัวข้อ "Label Studio Cloud" ด้านล่าง): (1) whole-JSON ต่อบ้าน project "Constistant01" (2) per-page Repeater ต่อรายการ project "Structural Review"/"BOQ Review" ตามแผน King — ทั้งคู่ยังไม่ publish/เชิญคนจริง
- **Extraction ยังไม่ครบทุกบ้าน** — 5/9 บ้าน (บ้าน_เล็ก ทั้งหมด) มี qwen-output แล้ว รวม BOQ ด้วย, เหลือ 4 บ้าน_ใหญ่ ยังไม่ได้รัน `run_pipeline.py`
- **Confidence/trust scoring 3 ชั้น** (ออกแบบไว้ในบทสนทนา ยังไม่ implement เป็นโค้ด):
  - ชั้น 1: model confidence (ไม่น่าเชื่อถือเดี่ยวๆ ตามข้อ 3 ด้านบน)
  - ชั้น 2: human confidence จาก Label Studio — เก็บ `reviewer_level` (junior/mid/senior/expert) + `human_confidence` (sure/fairly/unsure)
  - ชั้น 3: trust weight รวม (expert+sure = gold/1.0 ... junior+unsure = escalate ให้ senior ตรวจซ้ำ, ไม่เอาเข้า training ตรงๆ)
- **Fine-tuning dataset export** (JSONL รวม image+prompt+ground-truth) — ยังไม่มีสคริปต์ประกอบจาก `raw/image/<house>/qwen-output/` + reviewed data
- **Architectural extraction** — ตอนนี้ scope ล็อกเฉพาะ structural (ตามที่ตกลงกันไว้) ถ้าต้องการ floor_area จาก arch plan ต้องเพิ่ม pattern ใหม่

## Key files

| ไฟล์ | หน้าที่ |
|---|---|
| `run_pipeline.py` | **entry point หลัก** — Stage 0 → route → extract ทั้งโฟลเดอร์ |
| `build_document_map.py` | Stage 0 — อ่านสารบัญ, หา offset, สร้าง document map |
| `analyze_folder.py` | fallback per-page classify (ใช้เมื่อไม่มีสารบัญ) |
| `Prompt/stage-*/prompt.md` | เอกสารอ้างอิง prompt (source of truth จริงคือ string ในไฟล์ `.py`) |
| `raw/image/<house>/qwen-output/` | ผลลัพธ์ — `_document_map.json`, `_run_summary.json`, `<house>_หน้าNN.json` (อยู่ใต้โฟลเดอร์รูปของบ้านนั้นๆ เลย ดึงไป assign Label Studio ต่อบ้านได้ง่าย) |
| `SETUP.md` | วิธี setup ครั้งแรกใน repo ใหม่ |
| `label-studio-tasks-github.js` | สร้าง Label Studio import tasks จากรูปที่ root `image/<house>/` โดยอ้างเป็น GitHub raw URL ตรงๆ (ดูหัวข้อ Label Studio Cloud ด้านล่าง) |
| `label-studio-config-review.xml` | Labeling Interface config ที่ใช้จริงกับ project บน Label Studio Cloud ตอนนี้ (field ตรงกับ `label-studio-tasks-github.js`) |
| `label-studio-tasks.js` / `Prompt/stage-a/label-studio-config.xml` | **เวอร์ชันเก่า/เลิกใช้** — ชี้ path ผิด (`raw/image/` มีแค่ 1 บ้าน) และ config field ไม่ตรงกับ script ที่ generate task เก็บไว้อ้างอิงเฉยๆ |
| `label-studio-import-annotations.js` | แปลง export JSON จาก Label Studio → `annotated/<record_id>-annotated.json` + อัปเดต `manifest.json` (คู่กับ `label-studio-tasks-github.js` — whole-JSON flow) |
| `label-studio-tasks-perpage.js` | สร้าง task **ต่อหน้า** (ไม่ใช่ต่อบ้าน) แยก 2 ไฟล์ output: `label-studio-tasks-structural.json` / `label-studio-tasks-boq.json` — flatten `plan[]+section[]+schedule[]` (structural) หรือ `categories[].items[]` (boq) เป็น array เดียว ข้าม pattern `notes` (เป็น object เดี่ยว ไม่ใช่ list) |
| `label-studio-structural.xml` / `label-studio-boq.xml` | Labeling Interface แบบ Repeater ต่อรายการ — ใช้กับ project "Structural Review" / "BOQ Review" (แผน King) |
| `label-studio-import-repeater-annotations.js` | แปลงผล export จาก 2 project ข้างบน → `annotated/<record_id>-<type>-annotated.json` (คู่กับ `label-studio-tasks-perpage.js`) |

## Label Studio Cloud — review flow (เริ่มใช้จริง 2026-07-02)

**Hosting:** ใช้ **Label Studio Cloud** (`app.heartex.com`, Starter Cloud trial) ไม่ใช่ self-host — เพื่อนทีมเข้าออนไลน์ได้ทันทีไม่ต้อง tunnel/deploy เอง

**Image hosting:** repo `Training` (github.com/whysaomaitrongbaab-collab/Training) เป็น **public** → ใช้ **`raw.githubusercontent.com` URL ตรงๆ** เป็น image source ของ Label Studio ได้เลย ไม่ต้องอัปโหลดรูปเข้า Supabase Storage หรือที่อื่น (ทดสอบแล้ว: URL ที่ generate resolve ได้ HTTP 200 จริง) — รูปอยู่ที่ root-level `image/<house>/*.png` (ไม่ใช่ `training-data/raw/image/` ซึ่งมีแค่ 1 บ้านและเป็น path เก่าที่ scripts รุ่นก่อนอ้างผิด)

**Task/config ที่ใช้จริง:**
- `node label-studio-tasks-github.js` → อ่านทุกโฟลเดอร์ใน root `image/` → 1 task ต่อ 1 บ้าน, `data.images` = list ของ GitHub raw URL (encode ชื่อไทย/เว้นวรรคให้ถูกต้องแล้ว), แนบ `predictions` จาก `qwen-output/<house>-qwen.json` ถ้ามีไฟล์นั้นอยู่ (ตอนนี้ยังไม่มีเลยสักบ้าน → ทุก task ยังไม่มี pre-annotation)
- ผลลัพธ์: `label-studio-tasks-github.json` — import เข้า Label Studio ผ่าน Data Import → Upload Files (รองรับ JSON ตรงๆ)
- Labeling Interface ใช้ `label-studio-config-review.xml`: `<Image name="page" value="$images" valueType="list">` (โชว์ทุกหน้าของบ้านเป็น gallery) + `<TextArea name="corrected_json" toName="page">` (ให้พิมพ์/แก้ JSON ที่ถูกต้อง) + `<TextArea name="reviewer_note" toName="page">`

**สถานะปัจจุบัน:** สร้าง project "Constistant01" บน Label Studio Cloud สำเร็จ, import ครบ 9 tasks (9 บ้าน) แล้ว, สถานะ "Ready to Publish" — **ยังไม่ได้กด Publish และยังไม่ได้เชิญสมาชิก**

**ข้อมูลไม่ sync กลับอัตโนมัติ** — ตอนเพื่อน submit annotation ใน Label Studio Cloud ข้อมูลอยู่ในฐานข้อมูลของ Label Studio เท่านั้น ต้อง**ทำมือ**ทุกครั้ง:
1. Export จาก Label Studio (Project → Export → JSON)
2. `node label-studio-import-annotations.js <path-to-export.json>` → ได้ `annotated/*.json` + `manifest.json` อัปเดต
3. commit/push เข้า repo เอง

(ยังไม่ได้ตั้ง webhook ให้ sync อัตโนมัติ — ถ้าจะทำต้องมี server รับ webhook ก่อน)

**สิ่งที่ยังไม่ได้ทำต่อ:**
- Publish project + เชิญเพื่อนเข้า project "Constistant01" (ไม่ใช่แค่ invite เข้า organization)
- `label-studio-tasks-github.js` ยังหา `qwen-output/<house>-qwen.json` (ไฟล์รวมทั้งบ้าน) ไม่เจอเลย เพราะข้อมูลจริงที่มีตอนนี้เป็นไฟล์ **ต่อหน้า** ไม่ใช่ไฟล์รวม — ถ้าจะใช้ flow นี้ต่อ (whole-JSON ต่อบ้าน) ต้องเขียน merge script ก่อน; **แนะนำใช้ flow per-page Repeater ด้านล่างแทน** เพราะอ่านไฟล์ต่อหน้าที่มีจริงได้ตรงๆ ไม่ต้อง merge

## Label Studio Cloud — King's per-page Repeater review flow (2026-07-02, รอบ 2)

**ต่างจาก flow ด้านบนตรงไหน:** ด้านบนคือ 1 task = 1 บ้าน (ทุกหน้า) + กล่อง JSON เต็มก้อนให้พิมพ์ทับ — อันนี้คือ **1 task = 1 หน้า** + field แยกทีละรายการให้แก้ (ตามแผนที่ King ร่างไว้แต่เดิม, ปรับมาใช้ hosting เดียวกัน: Label Studio Cloud + GitHub raw URL จาก repo `Training` เท่านั้น ไม่ใช้ Supabase Storage ตามที่ King เสนอไว้ตอนแรก)

**Pipeline สร้าง task:**
```
node label-studio-tasks-perpage.js
  → อ่าน raw/image/<house>/qwen-output/<house>_หน้าNN.json ของทุกบ้านที่มี extraction แล้ว (5/9 บ้านตอนนี้)
  → discipline structural (pattern plan/section/schedule, ข้าม notes) → flatten เป็น items[] → label-studio-tasks-structural.json
  → discipline boq (categories[].items[])                              → flatten เป็น items[] → label-studio-tasks-boq.json
```

**Field ที่แก้ได้จริงใน UI (v3 — ลดลงจากตอนแรก):**
- Structural: `element_id, element_type, count, grid_refs, span_length_m, main_bar_dia_mm, stirrup_dia_mm, stirrup_spacing_mm` (8 ช่อง — เลือกเฉพาะจุดที่บทเรียนข้อ 2 ด้านบนบอกว่า AI มักพลาด) ส่วน `width_mm/height_mm/main_bar_count/main_bar_type/stirrup_type/concrete_grade/steel_grade` โชว์เป็นบรรทัดอ่านอย่างเดียว ไม่มีกล่องแก้ (แต่ยัง carry-over ค่าจาก AI เข้า output เสมอ ไม่ได้หายไป)
- BOQ: `item_no, description, quantity, unit` (4 ช่อง) ส่วนราคาต่างๆ (ยังเป็น null เกือบทุกแถวเพราะ extraction รอบนี้ไม่มีข้อมูลราคา) โชว์อ่านอย่างเดียว
- ทุกรายการมี checkbox "❌ ลบรายการนี้ (AI มโน)" แทนการลบจริง — ตอน import จะกรองแถวที่ติ๊กออกทิ้ง
- ไม่มีปุ่ม "+เพิ่มรายการ" (Label Studio Repeater ไม่รองรับ add/remove แถวจาก UI จริง — เช็คจากเอกสารทางการแล้ว) แทนที่ด้วยกล่อง `reviewer_note` ท้าย task ให้พิมพ์อธิบายเป็นคำพูดธรรมดาว่าขาดอะไร แล้วไปแก้ไฟล์ JSON ต้นทางเองทีหลัง

**⚠️ ความไม่แน่นอนที่ยังไม่ได้ verify กับเอกสารทางการ:** ตอนเขียน `label-studio-structural.xml`/`label-studio-boq.xml` ดึงเอกสาร Repeater tag ของ Label Studio มาเช็คไม่สำเร็จ (เว็บ error ซ้ำๆ) ใช้ syntax `on="$items"` + `{{idx}}` + `$items[{{idx}}].field` จากความรู้เดิม ทดสอบจริงใน Label Studio Cloud แล้วพบว่า**ใช้งานได้จริง** (เห็นค่าจริงในกล่องถูกต้อง) แต่เจอบั๊กเล็ก: ยัดหลายตัวแปรในกล่อง `<Text>` เดียวกันทำให้ตัวที่สองขึ้นคำว่า "undefined" — แก้แล้วโดยแยกเป็นคนละ `<Text>` ต่อตัวแปร

**สถานะปัจจุบัน:** สร้าง project "Structural Review" + "BOQ Review" บน Label Studio Cloud แล้ว, import task JSON แล้ว, ผ่านการทดสอบ Repeater รอบแรก (v1 ไม่มี label กำกับ → v2 เพิ่ม label → v3 ลดจำนวนช่องแก้) — **รอ user ทดสอบ v3 ล่าสุดในเบราว์เซอร์อีกรอบ** ก่อน publish/เชิญเพื่อน

## Convention

- ชื่อ output JSON = ชื่อไฟล์รูป 1:1 (แค่เปลี่ยนนามสกุล) — เปิดคู่กันได้ทันทีไม่ต้องพึ่ง manifest
- Field ของ element ผูกกับ schema ของ repo หลัก (`js/shared/schema.js` → `createBeamLibraryEntry`/`createDrawingElement`) เผื่อย้อนกลับไป wire เข้า pipeline หลักภายหลัง — ชื่อ field ควรตรงกันไว้แม้ repo นี้จะแยกออกมา
