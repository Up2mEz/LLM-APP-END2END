# NCD Evidence

เว็บถามตอบจากเอกสาร NCD ภาษาไทย ผู้ใช้ถามคำถาม อ่านคำตอบ และเปิดข้อความต้นทางเพื่อตรวจบริบทได้ ระบบใช้ Gemma ผ่าน class proxy, hybrid retrieval และการตรวจข้อความอ้างอิง

## เริ่มอ่านจากตรงไหน

- [รายงานฉบับส่ง](docs/PROJECT_REPORT_SUBMISSION_TH.md): ปัญหา สถาปัตยกรรม ผลประเมิน และข้อจำกัด
- [ผลประเมินปัจจุบัน](docs/CAPSTONE_CURRENT_EVALUATION_TH.md): เปรียบเทียบการค้นสองแบบบนระบบที่ใช้ส่งงาน
- [การเทียบ agent รุ่นเก่ากับปัจจุบัน](docs/PAIRED_AGENT_EVALUATION_TH.md): คำถามเดียวกัน 60 คู่ ปิดแคชทั้งคู่ รันครบแล้วและรอการตรวจเนื้อหาคำตอบ
- [คำศัพท์และวิธีอ่านเลขรุ่น](docs/READING_GUIDE_TH.md): React, pipeline, รหัสคำถามและแหล่งอ้างอิง
- [รายละเอียดทางเทคนิคและประวัติผล](docs/TECHNICAL_RESULTS_TH.md)
- [บทเดโม](docs/DEMO_SCRIPT_TH.md)
- [ที่มาของข้อมูลและส่วนที่นำมาใช้](docs/WORKFLOW_AND_REUSE_TH.md)

## ระบบทำงานอย่างไร

React ส่งคำถามไปยัง FastAPI แล้ว Gemma เรียก `search_docs` ระบบค้นด้วย bge-m3 ร่วมกับ BM25 และจัดอันดับข้อความซ้ำเมื่อเปิด reranker คำตอบผ่านการตรวจ schema และ citations ก่อนแสดงพร้อมหลักฐาน คำถามแต่ละข้อทำงานแยกกัน ไม่มีความจำบทสนทนาข้ามคำถาม

React สร้างหน้าเว็บ เช่น ช่องถาม ปุ่ม และแผงหลักฐาน ส่วน FastAPI รับคำขอฝั่งเซิร์ฟเวอร์ และ Gemma เป็นโมเดลที่ใช้ตอบ ภาพ pipeline คือแผนผังลำดับการทำงานของส่วนเหล่านี้ ไม่ใช่ชื่อเทคโนโลยีหรือรูปที่ React สร้างเอง

**ReAct agent loop** เป็นอีกคำหนึ่ง: โมเดลเลือกเรียกเครื่องมือ รับผลค้นกลับมา แล้วตัดสินใจตอบหรือค้นต่อ แอปใช้วงรอบเรียก `search_docs` ที่จำกัดจำนวนครั้งและตรวจผลก่อนส่งกลับผู้ใช้ ส่วน React ที่สะกดต่างกันเป็นเทคโนโลยีหน้าเว็บ ข้อความ trace แสดงเหตุการณ์เรียกเครื่องมือและตรวจคำตอบ ไม่ใช่ความคิดภายในโมเดล

รุ่นส่งงานใช้ **การค้นแบบผสม (hybrid) และเปิดการจัดอันดับหลักฐานซ้ำ (reranker)** เป็นค่าเริ่มต้น ผู้ใช้ปิดการจัดอันดับซ้ำได้ ผลหลักที่อ้างในงานนี้มาจากรอบ `capstone-current-v2` ซึ่งเป็นชื่อรอบทดลอง ไม่ใช่รุ่นของโมเดล คะแนน v30/v32 เป็นประวัติการทดลองที่เงื่อนไขต่างกัน ดูคำอธิบายในคู่มือด้านบน

เว็บไม่อ่านหรือเขียนแคชคำตอบและคะแนน reranker ในเครื่อง การปิด reranker ข้ามขั้นตอนจัดอันดับซ้ำ แต่ไม่ได้รับประกันว่าคำตอบจะเหมือนเดิมหรือเร็วขึ้นเท่ากันทุกครั้ง

## ติดตั้งและเปิดใช้งาน

เครื่องที่ใช้ตรวจเป็น Windows กับ Python 3.12 ต้องมีพื้นที่สำหรับข้อมูลและ model cache และมีบัญชี class proxy สำหรับเรียก Gemma ส่วน frontend ใช้ Node.js และ npm

```powershell
git clone https://github.com/Up2mEz/LLM-APP-END2END.git
cd LLM-APP-END2END
py -3.12 -m venv .venv312
.venv312\Scripts\python -m pip install -r requirements-runtime.txt
Copy-Item .env.example .env
```

หาก `py -3.12` หา Python ไม่พบ ให้ติดตั้ง Python 3.12 หรือใช้ `uv python install 3.12` แล้ว `uv venv --python 3.12 .venv312` แทนบรรทัดสร้าง environment

ใส่ค่าของบัญชีใน `.env` และเก็บไฟล์นี้ไว้เฉพาะในเครื่อง

```dotenv
OPENAI_BASE_URL=https://llm.nat-d.uk/v1
OPENAI_API_KEY=your-class-proxy-key
NCD_MODEL=gemma-4-E4B-it
```

ดาวน์โหลดข้อมูลจาก release ที่ระบุใน manifest และเตรียมโมเดล:

```powershell
.venv312\Scripts\python -B scripts/public_data.py fetch
$env:HF_HUB_OFFLINE = '0'
.venv312\Scripts\python -B scripts/prepare_models.py
$env:HF_HUB_OFFLINE = '1'
$env:PYTHONPATH = "$PWD\src"
.venv312\Scripts\python -B -m ncd_gemma.cli doctor --retrieval
```

สร้างหน้าเว็บแล้วเปิด backend:

```powershell
npm --prefix frontend ci
npm --prefix frontend run build
.\run.ps1
```

เปิด http://127.0.0.1:8765 การถามครั้งแรกอาจใช้เวลาโหลดโมเดลและ index หาก backend ยังไม่ได้โหลดไว้ ใช้ `npm --prefix frontend run dev` เมื่อต้องการพัฒนา frontend

## การประเมิน pipeline ปัจจุบัน

ประเมินด้วยคำถามและเฉลยที่ตรวจไว้ 30 ข้อจากชุดพัฒนา เปรียบเทียบการค้นด้วยความหมายอย่างเดียวกับการค้นแบบผสม ผ่านระบบค้นและเซิร์ฟเวอร์ปัจจุบัน ทั้งสองวิธีเปิดการจัดอันดับหลักฐานซ้ำและปิดแคช ใช้ GPT-6-Luna ตรวจคำตอบโดยไม่เห็นชื่อวิธีที่ใช้ ดู [วิธีทดลองและผลรายข้อ](docs/CAPSTONE_CURRENT_EVALUATION_TH.md) รหัสรอบนี้คือ `capstone-current-v2`

| สิ่งที่วัด | ค้นด้วยความหมาย (วิธีตั้งต้น) | ค้นแบบผสม (วิธีที่เลือกใช้) |
| --- | --- | --- |
| ความครอบคลุมหลักฐานในห้าอันดับแรก — Recall@5 (25 ข้อที่ตอบได้) | 0.82 | 0.90 |
| คำตอบที่ Luna ให้ผ่าน รวมการงดตอบที่ถูกต้อง (30 ข้อ) | 23/30 | 28/30 |
| ข้อที่บริการล้มเหลวและนับเป็นไม่ผ่าน | 1 | 2 |

Hybrid เพิ่ม Recall@5 8 จุดเปอร์เซ็นต์ และสำเร็จตาม judge มากกว่า 5 ข้อ Service errors ทั้งสามเป็น HTTP 429 ของ proxy ไม่มีการรันซ้ำแทนผลที่ผิดพลาด ผลเปิด/ปิด reranker แยกเฉพาะ retrieval ได้ Recall@5 0.90/0.74 และเวลามัธยฐาน 14.49/0.24 วินาที ไม่ใช้สรุปความเร็วหรือคุณภาพคำตอบทั้งระบบ

วัด retrieval บนข้อที่ตอบได้ 25 ข้อ ส่วนคะแนนคำตอบรวม 30 ข้อและเก็บ service errors ในตัวหาร ชุดนี้เคยใช้พัฒนาระบบ จึงระบุเป็น exposed dev การตรวจด้วย LLM-as-judge ไม่ใช่การตรวจทางคลินิก และไม่รับประกันผลกับคำถามใหม่

ชุด gold สร้างโดยผู้จัดทำให้ coding agent ร่างคำถามและคำตอบ แล้วตรวจร่วมกับเพื่อน ผู้จัดทำตรวจ dev เองทั้งหมด ส่วน test แบ่งกันตรวจเท่า ๆ กัน การตรวจ gold โดยคนแยกจากการตรวจคำตอบแอปรอบนี้ด้วย LLM-as-judge

ผล frozen retrieval และ v32 เก็บในเอกสารประวัติ ไม่ใช้เป็นผลของรอบปัจจุบัน

## ตรวจและประเมินซ้ำ

ติดตั้งเครื่องมือทดสอบด้วย `.venv312\Scripts\python -m pip install -e ".[dev]"` แล้วรัน:

```powershell
.venv312\Scripts\python -m pytest -q
$env:PYTHONPATH = "$PWD\src"
.venv312\Scripts\python -m ncd_gemma.capstone_eval verify --run capstone-current-v2
.venv312\Scripts\python -m ncd_gemma.capstone_eval run --run capstone-current-v2
.venv312\Scripts\python -m ncd_gemma.capstone_eval summarize --run capstone-current-v2
```

Unit tests ใช้ fake model และ retriever ส่วน `run` เรียกโมเดลจริงผ่าน class proxy และใช้ budget ตาม protocol; `verify` และ `summarize` ไม่เรียกโมเดล หากโค้ดหรือข้อมูลไม่ตรง manifest จะหยุด การ resume ไม่ยิงคำขอที่ค้างไม่ทราบผลซ้ำอัตโนมัติ รอบที่ครบแล้วจะข้ามรายการที่มีผลบันทึกครบ

คำสั่งเก่า `ncd_gemma.cli evaluate retrieval` เป็น frozen replay เท่านั้น ดูประวัติใน [รายละเอียดทางเทคนิค](docs/TECHNICAL_RESULTS_TH.md) การเปลี่ยน runtime หลังล็อกผลต้องสร้าง run ใหม่ ผลเดิมยังอ้างได้เฉพาะ configuration ที่บันทึกไว้

## โครงสร้างไฟล์

| ตำแหน่ง | เนื้อหา |
|---|---|
| `src/ncd_gemma/` | Agent, retrieval, schema, API และ CLI |
| `frontend/` | React, TypeScript, Vite, Tailwind และ shadcn/ui |
| `static/app/` | Frontend ที่ build แล้วและให้ FastAPI เสิร์ฟ |
| `tests/` | การทดสอบโค้ดและ API |
| `scripts/` | เตรียมข้อมูล ประเมิน และสร้างรายงาน |
| `reports/` | ผลประเมินและบันทึกตรวจแต่ละรุ่น |
| `docs/` | รายงาน คำอธิบาย และบทเดโม |
| `provenance/` | Manifest และ hashes ของข้อมูล |
| `private/`, `.cache/`, `data/` | ข้อมูลในเครื่องที่ไม่เข้า Git |

ก่อนแก้ UI อ่าน [design.md](design.md) และ [component.md](component.md) และใช้ Hallmark กับ ui-ux-pro-max ตาม [AGENTS.md](AGENTS.md)

## ข้อจำกัดและการส่งงาน

ระบบอาจเลือกบริบทผิด ตอบไม่ครบ หรืองดตอบทั้งที่มีหลักฐาน บริการโมเดลภายนอกอาจขัดข้อง ผู้ใช้ต้องตรวจเอกสารก่อนนำคำตอบไปใช้

รายงาน PDF ฉบับส่งอยู่ที่ `output/pdf/NCD_EVIDENCE_SUBMISSION_67070060.pdf` วิดีโอสำหรับ Q3 ต้องยาว 3–6 นาที มีเสียงบรรยายและตัวอย่างสำเร็จกับผิดพลาด แล้วอัปโหลดเป็นลิงก์ที่ผู้สอนเปิดได้ ไฟล์ในเครื่องและ localhost ยังไม่ใช่ URL ส่งงาน

Dockerfile มีไว้เตรียมการโฮสต์ แต่ยังไม่ยืนยันการรันทั้งระบบบน Linux รายละเอียดการตั้งค่าการเข้าถึงและข้อจำกัดของ temporary tunnel อยู่ในเอกสารทางเทคนิค
