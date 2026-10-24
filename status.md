# Project Status: OCBM

Last Updated: 2026-10-24 16:04

## 🎯 Current Objective

ทดสอบเวอร์ชัน 1.3.1 บนมือถือ — แก้ปัญหา chat template ของ Gemma 3 1B
- [x] Build commit 5055049 (v1.3.0, versionCode 4) สำเร็จใน 14 นาที
  - APK: https://expo.dev/artifacts/eas/IrnMiAVEw0_jTkt_tJ7v5bTSKi5jRwW_oFWLCr5az9M.apk

## ✅ Completed

- [x] เชื่อมต่อ Ollama ผ่าน LAN (2026-10-23)
  - เปิด `OLLAMA_HOST=0.0.0.0:11434` และ `OLLAMA_ORIGINS=*` ระดับ User
  - Windows Firewall มี inbound allow สำหรับ `ollama.exe` (Public profile)
  - ทดสอบจากมือถือผ่าน browser สำเร็จ: `http://192.168.1.154:11434` → "Ollama is running"
- [x] แก้ APK เดิมเชื่อม Ollama ไม่ได้ (2026-10-23)
  - สาเหตุ: `android.usesCleartextTraffic` ไม่ใช่ field ที่ Expo รองรับ → release APK บล็อก HTTP
  - แก้ด้วย `expo-build-properties` → `android.usesCleartextTraffic: true`
- [x] แก้ EAS build ชน timeout 45 นาที (2026-10-23)
  - สาเหตุ: `llama.rn@0.13.0-rc.8` บังคับ build-from-source 7 variants + x86_64
  - แก้: `buildArchs: ["arm64-v8a"]` + `ORG_GRADLE_PROJECT_rnllamaVariants=rnllama,rnllama_v8_2_dotprod_i8mm`
  - ผล: build สำเร็จใน **20.9 นาที**
- [x] เพิ่มโมเดล on-device หลายตัว ≤ 2B + ตรวจสเปคเครื่อง (2026-10-23)
  - Qwen 2.5 0.5B, Llama 3.2 1B, Qwen 2.5 1.5B, Gemma 2 2B
  - แนะนำโมเดลตาม RAM ที่ Android รายงาน, เตือน RAM/พื้นที่ไม่พอ
  - ดาวน์โหลด/ยกเลิก/ทดสอบ/สลับ/ลบโมเดลได้
  - migrate จาก store โมเดลเดียวเดิมอัตโนมัติ
- [x] Build APK v1.1.0 (versionCode 2) สำเร็จ (2026-10-23)
  - APK: https://expo.dev/artifacts/eas/l7QAOI7nvKmHKg9JriQh2eul1I9OI2BG1JYfdyEJPOE.apk
- [x] ขยาย on-device catalog เป็น 10 โมเดล ≤2B + ตัวเลือกแหล่ง AI (2026-10-23)
  - เพิ่ม Qwen3 0.6B, Gemma 3 1B, Typhoon2 1B (ไทย), Qwen3 1.7B, SmolLM2 1.7B, DeepSeek R1 1.5B
  - เพิ่ม `aiSource: 'auto' | 'local' | 'ollama'` ให้เลือกใช้โมเดลเครื่องหรือคอมได้ตลอด
  - กรองโมเดล Ollama ที่ไม่รองรับ chat (capabilities ไม่มี `completion`) ออกจากรายการ
  - เตือนเมื่อเลือกโมเดลที่คุยไม่ได้ และ auto-fallback ไปตัวที่ใช้ได้
  - Build v1.2.0 สำเร็จใน 12.9 นาที
  - APK: https://expo.dev/artifacts/eas/aTaTJAxvIC63tV-L2OmhVTbFfT2-0A-ozhCStx0jPyk.apk
- [x] UX/bug fixes kritikal (2026-10-24, commit 5055049)
  - ลบ `runCompletion` ที่ถูกเรียกซ้ำ → แก้ "ตอบเสร็จแล้วรีใหม่"
  - Header โชว์โมเดลที่ใช้จริง + ระดับแหล่ง AI
  - Stop generation สำหรับ on-device (AbortController + setSending)
  - KeyboardAvoidingView ด้วย `react-native-keyboard-controller` (adjustResize)
  - Edit/Delete ข้อความผู้ใช้ + Composer banner "Editing"
  - หน้า Profile (ชื่อ/อีเมล/เบอร์)
  - on-device ส่ง context history (buildContextMessages, 8 turns / 1600 chars)
  - เวอร์ชัน 1.3.0 (versionCode 4) กำลัง build

## 🚧 In Progress

- [ ] ทดสอบ v1.2.0 บนมือถือ: สลับ Auto / On-device / PC (Ollama), ดาวน์โหลดโมเดลใหม่, offline chat
- [ ] เก็บ feedback คุณภาพภาษาไทย/ความเร็วของแต่ละโมเดล (Typhoon2 1B vs Qwen 2.5 1.5B)

  - APK v1.3.1: https://expo.dev/artifacts/eas/LmRJsrFtD4mj7TG57HvXpcMl_jhg1daKhsweWReZs-4.apk

## ⏳ Pending / Todo

- [ ] พิจารณา streaming แบบ abort กลางทางสำหรับ local inference (ปัจจุบัน abort ได้หลังจบ)
- [ ] พิจารณา resume download เมื่อเน็ตหลุด
- [ ] พิจารณาเพิ่มตัวเลือกโมเดลในอนาคต (ยังต้อง ≤ 2B)
- [ ] ตรวจสอบว่าเครื่อง 32-bit จะติดตั้ง APK ไม่ได้ (ข้อจำกัดที่ตั้งใจ)
- [ ] iOS/iPad — **ตัดออกตามคำขอผู้ใช้** (ไม่มีแผนทำตอนนี้)

## 📝 Notes & Context

- **AI Source** — `settings.aiSource`: `auto` (local ถ้ามี ไม่งั้นใช้ Ollama), `local`, `ollama`
  - เลือกได้ใน Settings → Model Management แม้ติดตั้งโมเดล on-device แล้ว
- **Catalog 10 โมเดล ≤2B** — ลำดับใน `LOCAL_MODELS` สำคัญ: ตัวสุดท้ายของแต่ละ tier คือตัวที่ถูกแนะนำ
  - tier 1 (3.5GB): Qwen3 0.6B, Qwen 2.5 0.5B
  - tier 2 (5GB): Gemma 3 1B, Llama 3.2 1B, Typhoon2 1B (ไทย)
  - tier 3 (7GB): Qwen3 1.7B, SmolLM2 1.7B, DeepSeek R1 1.5B, Qwen 2.5 1.5B
  - tier 4 (10GB): Gemma 2 2B
- **Thinking models** — Qwen3 / DeepSeek R1 ส่ง `enable_thinking: false` ใน `generateLocal` เพื่อลด reasoning ที่ไม่จำเป็น
- **Keyboard** — `react-native-keyboard-controller` 1.22.7 (Expo bundled) + `KeyboardProvider` + adjustResize - **Stop local** — ส่ง `AbortSignal` ให้ `generateLocal` → เรียก `ctx.stopCompletion()` ทันทีเมื่อ aborted
- **ห้ามเลือกโมเดลที่ไม่รองรับ chat** — Ollama 0.40.9 คืน `capabilities` ใน `/api/tags`
  - `tev1:0.8b` = `decision` → เรียก `/api/chat` ได้ 400 `"does not support chat"`
  - ใช้ได้: `qwen2.5:3b` (`completion,tools`), `qwen3:1.7b` (`completion,tools,thinking`)
- **EAS Free plan timeout = 45 นาที** — ต้องคงการจำกัด ABI/variants ไว้ ห้ามลบ `ORG_GRADLE_PROJECT_rnllamaVariants` จาก `eas.json`
- **llama.rn 0.13.0-rc.8** ตั้ง `rnllamaBuildFromSource=true` ใน `node_modules/llama.rn/android/gradle.properties` (ห้ามใช้ prebuilt เพราะ stale)
- APK เป็น **arm64-v8a เท่านั้น**
- Build command: `eas build --platform android --profile preview --non-interactive`
- Ollama PC: `http://192.168.1.154:11434` (IP เป็น DHCP อาจเปลี่ยน)
- ไฟล์สำคัญ:
  - `src/lib/modelCatalog.ts` — catalog + recommendation logic
  - `src/store/localModelStore.ts` — installed/active/downloads + migration v2
  - `src/lib/modelDownload.ts` — download/cancel/delete/reconcile
  - `src/lib/localInference.ts` — llama.rn context + generate
  - `src/app/settings/local-model.tsx` — หน้าจอ On-device AI
- Tests: `npm test` (15 suites / 83 tests), `npx tsc --noEmit`, `npx expo-doctor` (20/20)
