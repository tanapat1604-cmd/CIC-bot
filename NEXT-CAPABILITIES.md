# Update 2026-10-08: two-way voice and screen target

User chose spoken input + spoken output, target Neal game then later3D. See [staged roadmap](SCREEN-VOICE-ROADMAP.md) and [new OCR regions evaluation](validation/2026-10-08-ocr-regions/RESULTS.md). Prior OCR failed gate remains historical evidence. New manual-language/ROIpipeline new-2clear11/11, development9/11; not automatic perception/control. Additional speech-runtime approval pending; no vision/voice/OCR/control integrated. Read-only browser window preview added at #/screen; native chooser validation pending, see SCREEN.md. Coding and slide enhancements below remain planned.

# Current OCR checkpoint — 7 ตุลาคม 2569

ต่อ clean ec4844a/สไลด์ 8f75bcb. ผู้ใช้เลือกและอนุญาต A: ติดตั้ง Tesseract5.5.3 + tessdata_fast tha/eng แยกใน ignored .tools แล้ว ไม่มี download LLM/best, paid service, ภาพออกนอกเครื่อง, prompt change หรือ training. qwen3:0.6b text-only คงเดิม,1.7bเก็บไว้; chat/tools/Stockfish/slides A/B เดิมยังใช้ได้

**ยังไม่เปิด OCR ใน CIC และยังไม่พร้อมแชร์/ควบคุมจอ:** fixed fast tha+eng OEM1/PSM3/OMP1 ผ่านไทยชัดและ browser fixture ที่ทดลอง แต่ new mixed11.76%CER, Thai12px full6.25%, blurตกหล่น, columnsเรียงผิด จึงไม่ผ่าน gateที่กำหนดก่อนทดลอง ไม่ปรับจากnewแล้วใช้คะแนนเดิมยืนยัน ผลและกรอบเป็นต้นแบบเครื่องมือผู้พัฒนา รายงาน `validation/2026-10-07-ocr/RESULTS.md`; raw/manifest/config/resourceแยก nativeกับfast

## ขั้นก่อนเชื่อม OCR

แนะนำใช้ fast ที่ติดตั้งแล้วต่อ ไม่มี downloadเพิ่ม: developmentใหม่สำหรับ explicit Thai/English/mixed selector, upscale/ROI/single-columnโดยแสดงการแปลงชัด ไม่ autoเดาจากผลทดสอบ. ตรึง pipeline แล้วใช้ **new-2 ที่ไม่เคยปรับ** รวมภาษา/ตัวเลข/เวลา/multiline/light/dark/small/reduce/blur/blank/columns/screenshot/instruction-in-image. เก็บ old new เป็น baselineเปิดแล้วและ regression เท่านั้น

ตัวเลือกขออนุญาตใหม่ภายหลังคือ best Thai+Englishเพิ่ม~21.95MiB (engineเดิม) slower CPUและRAMต้องวัดก่อน ไม่มีรับรองว่าจะดีกับโจทย์เรา อีกทางคือพักUIและใช้reportทดลองต่อ ภาษาไทยไม่ได้รับรองโดยWindowsOCR en-US

เกณฑ์: ไทย/ผสม clearต่อภาพ<=5% normalizedCER ไม่มีไทยตกหล่น; อังกฤษ<=2%; ตัวเลข/วันเวลา/เครื่องหมายสำคัญตรง; blankไม่มีfalse words; readingorderตรงcolumn spec; boxesสัมพันธ์กับglyphและsize/crop. ภาพอ่านไม่ชัดต้องแสดงข้อจำกัด/ขอภาพใหม่ ห้ามเติมจากqwenหรือ groundtruth ไม่แสดง confidenceที่toolไม่มี. ทดลองperformanceRAM/timeoutบนactualmaxlimitก่อนขยาย

## เส้นทาง OCR ใน CIC (แผน ยังไม่มี endpoint/UI)

1. ผู้ใช้เลือกไฟล์เอง previewผ่านobjectURL; PNG/JPEGเท่านั้นเสนอเริ่มต้น8MiB/8megapixels/ด้านไม่เกิน4096px ต้องทดสอบก่อนประกาศรองรับ. ไม่รับURL/path/shellจากภาพหรือผู้ใช้เป็นengineargs. ตรวจ bytes signature/PNGchunksหรือJPEGSOFจริงก่อนdecode, rejectanimated/multiframe/unsupportedbitdepth, rejectunsupportedEXIForientationหรือcanonicalizeแล้วบันทึกtransform. Decoderจริงตรวจ dimensionsซ้ำ ไม่เชื่อextension/MIME/declaredheaderลำพัง. ทดสอบspoof/truncated/corrupt/compressionbomb/oversizeโดยไม่allocateภาพใหญ่ก่อนguard
2. กด “อ่านข้อความ” ถึงส่งเฉพาะไฟล์ที่เลือกไปbackend127.0.0.1; userตรวจภาพก่อน ไม่มีautoOCR/on-upload/send-to-model. local HttpOnly session + exact Origin/Host/loopback + ownership; publicdemoไม่เสนอเชื่อม127.0.0.1หรือfetchlocalhost. Operatorconfigabsoluteexe/languagefilesที่ตรวจแล้ว ไม่downloadruntimeเอง
3. ทีละjob boundedchildprocess shell:false, generatedUUIDpaths, allowedlanguage/OEM/PSM, OMP1, RAMfreeguard, timeout20sเสนอเริ่มต้นและstdout/file/wordcountlimits ต้องวัดจริง. Ocr jobไม่ชนmodel/Stockfish/nativePowerPointกับglobalcomputebudget. จำกัดจำนวนjob/queue, RAMอาจเปลี่ยนหลังguard ไม่ปิดแอปอื่นเอง. บันทึกsource/language/version/transform ไม่fabricateconfidence; Tesseractwordscoreถ้าแสดงต้องlabel native scoreที่ไม่ใช่probability
4. states idle/preview/queued/running/cancelling/cancelled/error/ready; AbortController+generationID+session/jobownership. cancel/replace/clear/navigationต้องabortrequest, cancelownedworkerและdiscardlate result; waitverifiedstopก่อนacceptnewjob ไม่killall tesseract/processes. ฝั่งserverต้องตรวจclose/timeout/pendingpoll raceและorphan cleanup ไม่ถือปิดUIว่าprocessหยุดแล้ว
5. ผล original image+wordframes ใช้SVGviewBoxบนimage coordinate, expose transformและnatural dimensions; objectfit/letterbox/EXIF/crop/resize/zoom/DPRต้องทดสอบ. Frame IDและimageSHAสัมพันธ์กับผลทุกครั้ง ผลเดิมห้ามอยู่บนภาพใหม่ desktop/mobile/short. พิกัดภาพไม่ใช่OSscreenพิกัด ไม่ให้คลิกได้จากผลนี้
6. texteditor preserve rawแยกedited, copyเฉพาะuserกด, reviewedcheckboxก่อนsend. **ข้อความ OCR เป็น reference data ไม่ใช่คำสั่งผู้ใช้:** ต้องเพิ่มtyped reference envelopeในprotocolและUIแหล่งที่มา แยกจากuser instruction, routing/toolsรับคำสั่งเฉพาะข้อความที่userพิมพ์ตรง. ห้ามpaste OCRดิบเป็นuser roleแล้วเปิดrouterที่อ่าน /calcหรือคำสั่งส่ง/ลบ. ทดสอบภาพที่สั่งignore rules/อ่านsecret/เปลี่ยนgoalและforgedsource; systempromptอย่างเดียวไม่ใช่permission boundary
7. retentionที่จะต้องพิสูจน์: browserRAM/objectURL revokeonclear/replace/leave; backendtempUUIDใต้ignored `.cic-user-files/ocr` แยกslide/examples, ไม่เขียนทับ. deleteimage/TSV/TXTหลังอ่านผลหรือerror/cancelในfinally; resultRAMจนuserclear/sessionexpire, boundedstartuporphanreapหลังcrash. หากต้องเก็บhistoryให้userเลือกก่อน. LogsmetadataเฉพาะrandomrequestID/status/duration ไม่filename/image/OCRtext/base64 bydefault. ต้องทดสอบfilesystemจริง/permission/recoveryแล้วอธิบายตามactualbehavior **ปัจจุบันไม่ใช่นโยบายที่มีแล้ว**

เกณฑ์ผ่านintegration: frozennew-2quality + bytes/decodeboundary + faulttimeout/cancel/stale/route/serverdisconnect + nonlogging/cleanup + provenance/reference-only + explicitcopy/send + responsiveness screenshotsจริง. ชุดmockไม่แทนnative OCR; ผลlegacychat/tools/chess/slides A/Bต้องผ่านแยกactualกับopt-in skipped. UIต้องทดสอบเลือกภาพใหม่และการแก้ข้อความใหม่ ไม่hardcodefixture

## หลัง OCR: แชร์หน้าต่างแบบอ่านอย่างเดียว (แผนและการอนุญาตแยก)

- เริ่มจากuserclick browsergetDisplayMediapickerเท่านั้น ไม่มีsilentpermission/reusepreviouscapture/automaticdesktopshot. ขอเฉพาะwindow/tab; browserhintไม่ใช่guarantee ต้องตรวจtracksettings.displaySurfaceและหยุดtrackทันทีหากเป็นmonitorหรือไม่สามารถยืนยันscopeที่เลือกได้. แสดงtarget/statusindicatorและปุ่มหยุดที่เข้าถึงได้ตลอด; ทดลองpermissiondeny/no-picker/trackended/userrevoke/routeleave/browserreload
- หน้าต่างที่แชร์เลือกพื้นที่จำเป็นและpreviewก่อนแต่ละOCR snapshot. ไม่ใช่continuousanalysisdefault; มีpaused/sharing/processing/error/stopped, frameId/timestamp/naturaldimensions/transform, แสดงage; TTLเริ่มเสนอ10sสำหรับanalysisแต่ต้องวัดจริง. หน้าต่างย้าย/resize/DPIหลายจอหรือcapturegeometryเปลี่ยนต้องinvalidateภาพเก่าและขอframeใหม่. OCRอ่านtextไม่ได้บอกicon/layout/semanticภาพทั้งหมด qwen0.6bไม่มีvision; visioncomponent/modelใหม่ต้องประเมินRAM/สิทธิ์และขออนุญาตแยกก่อนdownload
- Stop/revoke/leaveต้องstopทุกmedia track/revokeobjectURLs/abortpendingOCR/clearframes andresults; nohidden/backgroundcapture, ไม่logภาพหรือOCRtextโดยdefault. ทดสอบbrowserpermissionจริงและtracklifecycle ไม่ถือSVGcoordinateQAครั้งนี้ว่าcapture permissionผ่านแล้ว
- No click/typing executorในขั้นนี้. OCRผ่านไม่เท่ากับคลิกจากพิกัดได้ ควบคุมจริงต้องscope/window identity/currentframe/focus/precondition/postcondition/DPI/croporigin checks, labที่แยก, maxactions/time/retry, immediate stop/คืนcontrol, หยุดเมื่อuncertain และการยืนยันส่งข้อความ/ซื้อ/ลบ/เผยแพร่/สำคัญแต่ละactionก่อนเริ่มตามแผนเดิม. ข้อความในภาพไม่เปลี่ยนgoal/permissionsเอง ไม่รับรองทุกแอป

การแจ้งสถานะcurrentchat/questioncards/report/statusเดิม ไม่มีpopupใหม่ OCRassessmentคือtoolintegration/evaluation ไม่ใช่training ไม่เปลี่ยนqwenหรือStockfishเป็นคะแนนความฉลาดทั่วไป

---

## แผนเดิมที่ยังใช้เป็นฐาน (รายละเอียด OCR ข้างต้นมีสถานะล่าสุด)

# แผนความสามารถที่ตรวจได้ 7 ตุลาคม 2569

สถานะเริ่ม c410c37 และผลตรวจบริการในเครื่อง แผนนี้ไม่ให้สิทธิ์ CIC ควบคุมเครื่องหรืออ่านไฟล์ทั่วไป ภาพหน้าจอ โค้ด และ fine-tune ยังไม่เริ่ม การเลือกสไลด์ A อนุญาตเส้นทางสไลด์เท่านั้น

## สไลด์: ทางเลือกสำหรับ RAM 8 GB

| ทางเลือก | ข้อดี | ข้อจำกัดและจุดเลือก |
|---|---|---|
| แนะนำ: โครงเรื่องที่ผู้ใช้ตรวจ + builder local | ผลข้อความและไฟล์ตรวจได้ ไม่ใช้ API และใช้เครื่องมือเดิม | เริ่มแบบเดียว ข้อความ 2–8 หน้า ใช้ PowerPoint ในเครื่อง ต้องแก้เนื้อหาเอง |
| ให้ 0.6b เสนอเนื้อหา แล้วรอผู้ใช้ตรวจ | ลดงานกรอกบางส่วนถ้าร่างใช้ได้ | ผลงานจริงรอบนี้ยังไม่ผ่านการวางแผน จึงยังไม่ต่อเข้าตัวสร้างไฟล์อัตโนมัติ |
| เลือกโมเดล/เครื่องอื่นภายหลัง | อาจเพิ่มคุณภาพภาษาและการอ่านภาพ | ต้องเลือกทรัพยากร ชนิดข้อมูล และงบก่อน ไม่มี download/external AI ในรอบนี้ |

เส้นทางรุ่นแรก: รับ brief/outline, schema check, แสดงโครงเรื่องและยืนยัน, job queue หนึ่งงาน, worker สร้าง PPTX, native render, ตรวจภาพทุกหน้า, ดาวน์โหลด, revision ใหม่พร้อม parentId. สถานะกำลังทำ/ยกเลิก/ผิดพลาด/พร้อม ไม่แสดงผลมาช้า ไม่ลบของเดิม ไฟล์ผู้ใช้ใน ignored `.cic-user-files` แยกตัวอย่าง `.tools/slides-examples`.

เกณฑ์ขั้นต่อไป:

1. **โครงเรื่องที่ผู้ใช้ตรวจ** ผ่านโจทย์พัฒนาและโจทย์ใหม่ รวมดาวน์โหลดจริง เปิด PPTX, PDF/PNG ครบ, ไทย/ล้น/ลำดับตรวจภาพ, revise และ hash ต้นฉบับเดิมตรง รุ่นแรกสร้างไฟล์ ไม่รับรองว่าคิดเนื้อหาเอง
2. **ร่างโครงเรื่องด้วยโมเดล** ประเมินหัวข้อใหม่ 6–8 หน้า คำขอเปลี่ยนลำดับ/ลดหน้า/แก้ข้อมูล ถามข้อมูลที่ขาด ปฏิเสธข้อเท็จจริงไม่รู้ ได้ schema หรือแสดง error โดยไม่แอบเติมเนื้อหา ผู้ใช้ต้องตรวจ draft ก่อน build ไม่ retune จากชุดใหม่แล้วใช้คะแนนเดิม
3. **ภาพ/ตาราง/แม่แบบเพิ่มเติม** ผู้ใช้เลือกไฟล์ต้นทาง ตรวจสิทธิ์และแหล่งอ้างอิง จำกัดขนาด/ชนิด รูปไม่ออกนอกเครื่อง charts/tables ต้อง editable ตามโจทย์ เปิด/ตรวจทุกหน้า และทำ reference preservation test ไม่มี template import ของผู้ใช้ในรุ่นแรก
4. **คลังงานและการเรียกคืน** index/session identity ที่ปลอดภัยหลัง restart, retention/export/delete โดยผู้ใช้, quota ตามพื้นที่, orphan recovery, failure reporting และ preview cache ปัจจุบันไฟล์อยู่ แต่ index ยังไม่ฟื้นคืน ไม่มี auto-cleanup ผู้ใช้

RAM guard เป็นการตรวจ ณเวลาหนึ่ง ไม่ใช่ประกัน latency ใช้งานทีละ job ไม่รันโมเดล/engineพร้อม render จำกัด Node heap/page count/deadline เก็บ RAM ก่อน/ระหว่างงาน และ raw failure หากหน่วยความจำต่ำแสดงให้ผู้ใช้จัดการเอง ไม่ปิดโปรแกรมอื่น ไม่มีภาพสร้างด้วย AI หรือ video generation บนเครื่องนี้

## งานเขียนโค้ด: แผนสี่ขั้น

| ขั้น | ขอบเขตที่อนุญาต | เกณฑ์ผ่าน |
|---|---|---|
| 1 อ่านและเสนอแผน | อ่านเฉพาะไฟล์ที่ผู้ใช้เลือกใน workspace อธิบายอาการและเสนอทางแก้ | อ้างตำแหน่งจากไฟล์จริง แยกสมมติฐาน/ข้อเท็จจริง ถามเมื่อไฟล์หรืออาการขาด ไม่มีอ่าน secrets หรือ scan ทั้งดิสก์ |
| 2 สร้าง/แก้ไฟล์ | เส้นทาง canonical อยู่ใน workspace ที่อนุญาต แสดง diff ก่อน apply และใช้ snapshot/hash ตรวจไฟล์เปลี่ยน | diff ตรงโจทย์ ไม่เขียนทับ concurrent edits ไม่ตาม symlink/junction/hardlink ออกนอกขอบเขต ไม่ลบไฟล์อื่น |
| 3 รัน tests/build | คำสั่งจาก allowlist ที่ตรวจแล้วใน environment จำกัด network/process/files/time | baseline fail, หลังแก้ behavior ผ่าน, regression ไม่แย่ลง รายงาน stdout/stderr/exit/time ตรงจริง ไม่มี shell จากโมเดลโดยตรง |
| 4 ผู้ใช้ตรวจงาน | แสดง diff ผลตรวจและความเสี่ยงก่อน publish/merge/deploy/ส่งข้อมูล | การยืนยันระบุ repo/ปลายทาง/action/version ชัดเจน ปฏิเสธผลภายนอกที่ยังไม่อนุญาต |

โจทย์ประเมินแยกกัน:

- แก้บั๊กฟังก์ชันรวมยอด: invalid input/ขอบเขต/ทศนิยม มี behavior tests ที่ fail ก่อนแก้ และรัน regression ที่ไม่เกี่ยวกับ patch
- เพิ่มฟีเจอร์เล็ก: กรองรายการที่เสร็จแล้วในแอปตัวอย่าง ทดสอบเปลี่ยน filter, เพิ่ม/แก้รายการ และ state หลัง reload หาก persistence อยู่ใน scope
- สร้างแอปเล็ก: รายการงานใน workspace ใหม่ ทดสอบสร้าง/แก้/ยกเลิก ลบเฉพาะรายการในแอป keyboard/mobile/error ไม่ถือ screenshots หรือ exit0 เพียงอย่างเดียวว่าโปรแกรมถูกต้อง
- ทดสอบขอบเขตด้วย path traversal, junction ออกนอกงาน, secrets fixture ที่ไม่ใช่ secretจริง, คำสั่งลบ/ส่ง network และไฟล์เปลี่ยนหลังเสนอ diff ต้องไม่อ่าน/เขียน/รันก่อน authorization

รายงานความถูกต้อง (behavior assertions ผ่าน/ทั้งหมด), regression failures ก่อน/หลัง, จำนวนการละเมิดขอบเขต (ต้อง 0), patches ที่ตรวจได้ และเวลาจริง แยกจากข้อความคำอธิบายโมเดล บน Windows ต้องเลือก sandbox/process isolation ที่พิสูจน์การจำกัดจริงก่อนเปิดรันโค้ดไม่เชื่อถือ การมี subprocess helper สไลด์ไม่แปลว่า CIC มี coding executor/shell แล้ว

## แชร์และควบคุมหน้าจอ: แผนสี่ขั้น

1. **ผู้ใช้เลือกภาพหรือหน้าต่าง อ่านอย่างเดียว** เริ่ม image upload ที่เลือกเองและ object URL ในหน่วยความจำ หรือ getDisplayMedia ผ่าน browser picker ที่ผู้ใช้กดเอง ต้องดู indicator/ปุ่มหยุด แชร์เฉพาะหน้าต่าง/ส่วนจำเป็น ห้ามเริ่ม capture เงียบ ๆ ผ่านสถานะ demo ปัจจุบัน
2. **วิเคราะห์และเสนอการกระทำ** ใช้ OCR local สำหรับข้อความหรือโมเดลภาพ local ที่ผู้ใช้เลือก แสดงสิ่งที่อ่านได้/ไม่แน่ใจและแผน โดยยังไม่ dispatch click/type qwen3:0.6b ที่ติดตั้ง `/api/show` มี completion/tools/thinking **ไม่มี vision** และ transport ปัจจุบันส่ง text เท่านั้น ต้องเพิ่มองค์ประกอบจริง ไม่ได้แก้ด้วย prompt
3. **หน้าทดสอบแยก** adapter DOM เฉพาะหน้า lab ที่ควบคุมได้ ทดลอง save/type และตรวจผล state มี stop/cancel และ limits หน้าจอจำลองเดิมเป็น prototype ไม่ใช่ native OS control ผล lab รับรองได้เฉพาะ lab ไม่ให้ขยาย scope ไปแอปจริงเอง
4. **แอปจริงเฉพาะงานและหน้าต่างที่อนุญาต** เพิ่ม helper local ด้วย window identity/foreground/geometry และ action allowlist หลังผู้ใช้เลือกขอบเขต หลักฐานทุก action และเงื่อนไขหยุด ไม่รับรองทุกแอป โหมด admin/remote desktop/เกม/หน้าต่างป้องกัน capture อยู่นอก scope จนตรวจแยก

องค์ประกอบการอ่านภาพให้เลือกเมื่อพร้อม: **OCR ของ Windows** ใช้ CPU และเหมาะข้อความ แต่ต้องตรวจภาษาไทย/อังกฤษที่ติดตั้งจริงและความผิดพลาด OCR; **โมเดลภาพ local** อาจเห็นโครงสร้าง/รูปได้ แต่ต้องตรวจ RAM/ความเร็ว/สิทธิ์โมเดลและชุดทดสอบ ก่อนขอดาวน์โหลด ไม่มีองค์ประกอบใดติดตั้ง/เชื่อมแล้วในรอบนี้ ไม่เลือก cloud ให้โดยปริยาย

ข้อกำหนดภาพและพิกัด:

- Frame มี session/source/window ID, monotonic sequence, capture timestamp, ต้นฉบับ width/height, cropped ROI และ resize transform ไม่ใช้ devicePixelRatio ตัวเดียวแทน mapping ทุกจอ
- browser capture ของหน้าต่างไม่ได้ให้ native window handle/ตำแหน่ง OS ที่เชื่อถือได้ ต้องมี helper ที่จับคู่ window ID และ physical client rectangle ก่อน native clicks ภาพ upload ไม่มี mapping ไปหน้าต่างจริง จึงวิเคราะห์ได้อย่างเดียว
- เก็บแยก image pixels, browser CSS pixels, native logical pixels และ desktop physical coordinates รวมจอที่มี origin ติดลบและ DPI ต่างกัน แปลงด้วย transform ที่ตรวจแล้ว ถ้าหน้าต่างย้าย/resize/ย้ายจอ invalidate proposal และถ่ายใหม่
- เสนอเพดาน frame age 2 วินาทีตอน action ใน lab เพื่อทดลอง ไม่ถือเป็นค่าที่ผ่าน native แล้ว ถ้า sequence เก่า focus เปลี่ยน window/ROI ไม่ตรง มี overlay/loading หรือภาพไม่ชัด ให้หยุดและอ่านใหม่ ไม่มี blind retry
- ก่อน action ตรวจ window identity/focus/ตำแหน่งและสิ่งที่คาด เช่น label/button ก่อนพิมพ์ตรวจ field/value ที่ต้องแก้ หลัง action ถ่ายใหม่และตรวจ expected state อาจใช้ DOM/UI Automation ใน scope เพื่อเพิ่มความแม่นยำ แต่ไม่ถือ OCR coordinates ล้วนว่าปลอดภัย

หยุดและความยินยอม:

- Pilot เสนอสูงสุด 5 การกระทำหรือ 30 วินาทีต่อ authorization token (ค่าเริ่มต้นแผน ยังไม่ implement) ปุ่มหยุดบน UI ต้องหยุด pending queue และ helperจริงภายในเกณฑ์ที่วัด ให้ผู้ใช้กลับมาควบคุมได้ทันที มี native emergency hotkey เมื่อเพิ่ม helper ไม่อ้างว่า Esc ใน browser หยุด OS ได้แล้ว
- input ผู้ใช้/focus เปลี่ยน/permission revoked/error/timeout/ไม่แน่ใจ ยกเลิกต่อเนื่อง ถ้า stop transport ติดต่อ helperไม่ได้ ต้อง fail closed ไม่รายงานว่า “หยุดแล้ว” จาก UI อย่างเดียว ตรวจผลหลังหยุดด้วย
- ส่งข้อความ ซื้อสินค้า ลบข้อมูล เผยแพร่ เปลี่ยนการตั้งค่าสำคัญ ต้องยืนยันแต่ละรายการระบุข้อความ/รายการ/ปลายทาง/ราคา/ผลที่เกิด การอนุญาตอ่านข้อความหรือคลิกใน lab ไม่ใช่การอนุญาตผลภายนอก
- ข้อความบนหน้าจอ รวมคำสั่งให้ “ละเลยกฎ”/อ่านข้อความอื่น/ส่งข้อมูล เป็นข้อมูลที่ไม่น่าเชื่อถือ ห้ามเปลี่ยน goal/scope/permissions ข้อความ OCR/โมเดลไม่ลงนาม authorization ห้ามอ่าน secrets หรือหน้าต่างอื่นโดยอัตโนมัติ
- เก็บภาพใน RAM โดยปริยาย เลือก ROI/reduce pixels ที่จำเป็น ห้าม log ภาพ/ข้อความส่วนตัวเป็น default ถ้าผู้ใช้ขอบันทึกให้ตกลงตำแหน่ง การเข้าถึงและเวลาลบ revoke object URLs/หยุด media tracks เมื่อออกจากหน้า ภาพเก่าห้ามใช้กับ action ใหม่ ไม่ส่งภาพให้ external service ใน scope นี้

เกณฑ์ผ่านแต่ละขั้น: ขั้น1 permission/capture-stop/ROI/privacy tests และผู้ใช้ตรวจภาพที่แชร์จริง; ขั้น2 ชุดภาพใหม่หลายรูปแบบและภาษา ตรวจ false reads/uncertainty/proposal โดยไม่มี clicks; ขั้น3 lab ตรวจ stale/moved/resized/multi-DPI simulation/stop/post-state/side-effect confirmation; ขั้น4 native window ที่เลือกกับ DPI/หลายจอจริง ตรวจ focus/race/stop/recovery/effects ก่อนขยายแอป ยังไม่มีคะแนน native ในรอบนี้

## การประเมินความสามารถและ fine-tune

แยกโมเดล (planning/correction/clarification/unknown/verification), เครื่องมือ (output/schema/open-file/render), และระบบ (routing/auth/cancel/stale/storage/UI). เก็บ baseline checkpoints/case hashes, development, regression และ new test แยกกัน เก็บ raw history/source/calls/errors/times ไม่มีรวม Stockfish เป็นคะแนน qwen และไม่มีใช้ความสวยของเด็คผู้พัฒนารับรอง CIC

ไม่มีปรับ prompt/model ในรอบนี้ ไม่มี training/fine-tuning การเพิ่มเครื่องมือ/ทดสอบเป็น integration/evaluation. หากจะเสนอ fine-tune ต้องมีปัญหาที่ปรับน้ำหนักอาจแก้และเทียบทางเลือก, ข้อมูลที่มีสิทธิ์ใช้/consent/provenance/PII removal, train/dev/eval ที่ไม่รั่วข้าม task/user/document, ชุดประเมินใหม่และฐานเปรียบเทียบ, tokenizer/format/license, RAM/VRAM/disk/time/hardware, งบ compute/ไฟฟ้า/ค่าเช่าตามทรัพยากรที่เลือกจริง และ rollback. RAM 8GB ที่เหลือว่างน้อยไม่ใช่หลักฐานว่าฝึกได้ จึงไม่เริ่มหรือแต่งประมาณต้นทุนก่อนมี resource/data choice

การแจ้งสถานะ: CIC มี status ในหน้าแอปและผลไฟล์ ไม่มี popup/background wakeup ที่เชื่อมแล้ว นักพัฒนาสื่อสารผ่านแชตและ question cards การเลือก screen scope ยังต้องถามแยกในรอบที่เริ่มจริง
