1. project_id: APP-ADR-UI
2. session_id: S-20261113-A
3. block_id: CTX-APP-ADR-UI-20261113-01
4. tier: 1
5. version: 1
6. source_chat_url: (chưa có)
7. source_range: kimducanh27-cpu/app-adr-ui dự án đang phát triên đã có 3 4 process rồi còn những process → @skill:handoff tạo file này vào docs luôn đi, nhờ đồng bộ lại 7 file kia,
8. parent_block_ids: (chưa có)
9. status: current
10. created_at: 2026-11-13 14:08 +07
11. updated_at: 2026-11-13 14:08 +07
12. canonical_packet_version: 1
13. original_archive_link: (chính là Phần 2 của file này)
14. Quyết định đã chốt (nguyên văn, kèm lý do):
- User "yes to all" (2 lần): duyệt toàn bộ đề xuất Q1–Q5, rồi Q7–Q9.
- Q1: main là trục duy nhất để xây 05–08; nhánh v3.0-p0-gate-enforcement là sản phẩm khác (build orchestrator), tách ra, không trộn — vì Process 05 phải đọc Control File của 04, nên contract của 04 quyết định contract của 05.
- Q2: sửa P04-IMP-01 bằng sentinel — thay giá trị field bằng `<HASH_OMITTED>` trước khi hash, writer/reader normalize giống nhau; align spec + template + Skill; đóng Phase 6 rồi mới xây 05 — vì 05 sẽ copy nguyên pattern event/receipt này, không sửa thì 05 thừa kế đúng lỗi đó.
- Q3: phương án (a) — 05 = UX/UI Design → 06 = Technical Architecture & Delivery Plan → 07 = Build/Verification/Release; chỉ 05 được viết hợp đồng đầy đủ, 06/07 chỉ nhận charter 1 đoạn trong README.
- Q4: (b) rồi (a) — viết 5 tờ charter trước (thực tế viết 4, vì số lượng emergent), rồi viết trọn P5 — vì chưa chốt được P5–P9 là gì, viết 15 file cho một process có thể sai vị trí là đốt công.
- Q5: reviewer = (a) agent khác, context sạch, chỉ đọc file và append finding, không sửa artifact — khớp kiến trúc "independent review tab" đã có, chạy được ngay không cần chờ ai.
- Q6: số process là emergent — "chưa chốt 7 hay 9 chỉ khi nào đủ mới thôi"; pipeline thật là 8 bước: Seed → Discovery → Definition → App Flow → UX Design → Design Systems → UI Design → Validation; README bỏ chữ "seven-process workflow", thay bằng "a number is a slot, not a promise".
- Q7: sửa sentinel, đóng Phase 6, xây P5 trên v4 (coi "yes to all" là đồng ý sửa bằng sentinel).
- Q8: UX spec dùng khối ASCII/grid (b) — diff được, hash được; khối ASCII không có thẩm quyền, list thứ tự mới là hợp đồng — vì thuần chữ thì P6/P7 không có gì để bám về mặt không gian, ảnh thì không diff/review được trong PR.
- Q9: giữ 3 ranh giới — P5 không được đặt tên component (kể cả "button"); P6 không được nói component đặt ở đâu; P8 không được sửa bất cứ thứ gì, kể cả lỗi chính tả — vì một trong ba bị lỏng thì scope sẽ chảy ngược.
- Q10: (a) dựng initiative mẫu P1→P4 (sản phẩm nhỏ giả định, 6–8 screen) để P5 chạy thật — vì nó biến 53 dòng NOT RUN thành evidence thật, dùng lại được cho P6, P7, P8.
- Q11: platform = (a) Android native (Compose + Material 3); thêm `platform` vào Control template P6 như recorded decision bắt buộc — để không ai phải suy ra từ tên thư mục, và để `android.md` thành ràng buộc kiểm tra được ở Gate.
- "Quy trình này để dựng UI app adr được không?": WorkBuddy trả lời được — nền tảng hợp lý để dựng UI Android bằng AI agent; khuyên mở rộng thành 7 giai đoạn (thực tế 8 bước); App Flow tách riêng để kiểm duyệt độc lập.
- Cấu hình The Seed chốt: AI = Sparring Partner; nghiên cứu = Deep; tổ chức Antigravity = 3 tab độc lập.
- Luật quản trị do user đặt: "repo kít này phát triển theo hướng tham khảo repo khác, lấy khung hoặc nguyên văn chứ không được tự bịa".
- "commi repo hiện tại đi, rồi up p4 5 6 lên": push 7d2dedc..62b8541 → origin/p04/implementation-v0.3.1.
- "tách": tách PR #1 về chỉ-P04 (9 commit, 16 file), mở PR #2 riêng cho P05–P06 + charters — vì một CR không được gộp ba phạm vi (luật Change Request phải scoped).
- "test đi hihi, tôi sẽ kh test thủ công": test live bằng Meta Muse / agy, không test thủ công.
- P4 chưa 5 sao: đặc tả 4.5/5, implementation 3/5, bằng chứng 0/5, nhất quán 2/5 — vì "5 sao" trộn hai thứ: suy nghĩ tốt và chạy được.
- "Skill bạn lấy nguyên văn hay lấy khung thôi": dẫn tới copy nguyên văn 4 file upstream + kiểm kê provenance (P5: 2 VERBATIM + 1 ADAPTED + 11 LOCAL = 79% tự viết).
15. Ràng buộc / quy tắc:
- Contract viết bằng tiếng Anh như toàn bộ repo; trao đổi với user bằng tiếng Việt.
- Later contracts must be added explicitly; do not infer from numbering.
- P5: không đặt tên component; không giá trị màu/font/spacing; không copy cuối; khối ASCII không có thẩm quyền.
- P6: component chỉ tồn tại nếu ≥1 screen cần nó, cite SCREEN ID, không cite được thì Gate 2 từ chối; token 3 tầng (ref/sys/comp, theo Material 3); contrast đo từ giá trị đã resolve.
- P7: Gate 2 so sánh tập hợp: screen ⊆ P4, component ⊆ P6, state = P5, spacing phải có token.
- P8: chưa chạy test = NOT RUN, không bao giờ PASS; không sửa bất cứ thứ gì.
- P5 verify P03 gián tiếp qua hash P04 đã ghi, không đọc Control File P03.
- Không merge, không push vào main khi chưa duyệt (văn hóa gate); PR phải là Draft, "Do not merge", "Runtime verification: NOT RUN".
- Upstream: giữ nguyên văn + giữ license/copyright/attribution; không viết lại khi skill gốc đã giải quyết đúng vấn đề; chỉ fork/sửa khi xung đột thực tế; sửa thì ghi rõ thay đổi; không thay upstream chỉ để đổi tên/phong cách.
- Accessibility chia 3 tầng (P5 nêu yêu cầu / P6 cấp token / P8 đo); usability evidence muộn thì reopen P5, không đẩy sang P7; P5 chỉ lo IA trong từng screen (IA xuyên screen là CR về P4).
- Review: tối đa 3 vòng; independent review; evidence over claims; human owns direction; agent không tự chuyển giai đoạn; Human Approval Gates.
- P04: 13 trạng thái CR, 18 transition (T01–T18); abort pair; hash chain; migration có manifest; sentinel áp cho MỌI event (cả event thường lẫn abort marker).
- Không sửa artifact đã duyệt (P04-REMEDIATION-PLAN-v0.3.1.md) — superseded by reference, not by edit; mâu thuẫn thì tạo file reconciliation riêng (P04-STATUS-RECONCILIATION-2026-11-12.md).
- agy: gọi headless bằng -p/--print; chế độ TUI tương tác sẽ treo; harness phải ghi rõ cách gọi.
- Meta Muse và agy là hai sản phẩm tên Muse khác nhau, phải tách rõ (Meta Muse = agent tiêu dùng trên VM Meta, có Sentinel giám sát, có shell thật; agy = Antigravity CLI).
- Mọi phép kiểm viết dưới dạng tìm chuỗi trên văn bản có chứa ví dụ của chính nó sẽ có ngày khớp vào phần văn (bài học từ F-04/F-09).
16. Việc đang dở:
- Initiative mẫu P1→P4 (Q10): fixture P04 đã dựng (make-fixture.py — sinh P04 workspace với APP_FLOW.md, PRODUCT_DEFINITION.md, Register, hash thật) và dùng cho probe 2–11; initiative mẫu đầy đủ P1→P4 cho 53 kịch bản P5 — không chắc đã xong (trong đoạn trích chỉ thấy fixture P04).
- Charters (c0b9d50) + P5 (c9b0879) + P04 sentinel fix (194d77a): lúc tạo thì "chưa push" (máy chưa có credential); CUỐI CHẶNG ĐÃ PUSH: 7d2dedc..62b8541 → origin/p04/implementation-v0.3.1 (19 commit, 63 file, PR #1 vẫn DRAFT); PR #2 (10 commit, 51 file: charters + P05 + P06 + PROVENANCE.md) cũng đã tạo và chuyển Draft; cả hai PR chưa merge; nhánh cuối buổi 37 commit trước main (793b894). Việc "chưa push" chỉ đúng ở thời điểm tạo các commit đó.
- 53 kịch bản P5 NOT RUN: checklist 53 kịch bản chưa ghi nhận đã chạy (vẫn NOT RUN theo checklist); đã chạy live 11 probe (P04/P05/P06) bằng agy/Meta Muse — probe phủ ~5% (5–7/130 kịch bản); tổng 130 kịch bản NOT RUN (P04 22, P05 53, P06 55) theo checklist; probe không thay thế checklist.
- P7/P8: vẫn chỉ là charter, chưa có contract.
- Quy tắc sentinel: đã test live (probe 8): lần đầu agent viết digest sai (stored 03d756a9… vs computed dad68f94…) và báo thành công; đã thêm validate-register.py + bắt tính lại digest trước khi báo commit; F-08 đóng bằng đặc tả, chưa đóng bằng chạy lại (khác F-06 đã đóng bằng chạy lại probe).
- 6 file docs/ (354 dòng, commit 793b894): đã xong + push; mục đích mở session mới không phải kể lại.
- Luật "không được tự bịa": đã có trong PROVENANCE.md/RULES.md (commit 42f615a) nhưng là luật duy nhất không có máy kiểm (23 luật đã dán nhãn, 5 file nhắc, 0 validator).
- PR #1 + PR #2: cả hai Draft, chưa merge; merge authorization NOT GRANTED.
- Yêu cầu cuối chặng (tin cuối): "@skill:handoff tạo file này vào docs luôn đi, nhờ đồng bộ lại 7 file kia, với nhớ rà lại xem còn thiếu gì không" — chưa thấy hoàn thành trong đoạn trích (chặng kết thúc tại yêu cầu này).
- Kit trial (Prompt A trên WorkBuddy trong chặng): THIẾU NGUỒN — không có đoạn trích dán kèm + repo dữ liệu 404 (lúc đó còn private); user đã mở public repo sau đó; block này (CTX-APP-ADR-UI-20261113-01) chính là lần gấp thay thế, do Muse thực hiện.
17. Dữ kiện nguyên văn:
- Repo app-adr-ui: 89 file, 5.842 dòng markdown, 118 commit; main = 99ac2c6 (10/11); 4 process 01→04; thư mục dự án C:\Users\ducti\WorkBuddy AI\2026-11-12-15-51-45\app-adr-ui.
- p04/implementation-v0.3.1: 7 commit 15:37–15:43 ngày 12/11, schema v4 + Change Request Register; PR #1 DRAFT / DO NOT MERGE; Phase 6 BLOCKED bởi P0-IMP-01; Phase 7 NOT RUN (lúc đầu buổi).
- v3.0-p0-gate-enforcement: 35 commit (09/11); README chỉ ghi "# Muse-mater-woker"; MUSE_ORCHESTRATOR.md + docs/specs/phase-1..3 + scripts/validate-gates.py.
- product/ chỉ có 4 file README; không có SEED.md, PRODUCT_DEFINITION.md, APP_FLOW.md (lúc đầu buổi).
- Charters: commit c0b9d50, nhánh charters/p05-p08-v0.1.0; 4 tờ (05 UX Design, 06 Design Systems, 07 UI Design, 08 Validation) + README.
- P04 fix: 194d77a, ADR-P04-11, stress tests ST-21/22, Phase 6 đóng.
- P5: 17 file, 1.379 dòng, c9b0879; SKILL.md 240 dòng; 3 tab prompt; 10 template 00–09; checklist 53 kịch bản.
- P6: 16 file, 1.531 dòng, 695eae7; 6/8 process đã có contract (01→06); P6 không phát minh cơ chế mới.
- P6 overclaim fix: 62b8541; Android chốt: 7c7ee26.
- Push: 7d2dedc..62b8541 → origin/p04/implementation-v0.3.1; PR #1: 19 commit, 63 file, +6.065/−97, DRAFT; PR #1 tách về chỉ-P04: 9 commit, 16 file; PR #2: 10 commit, 51 file, +4.357/−5, Draft.
- Nhánh cuối buổi: 37 commit trước main (793b894); các commit khác: 4fe1197 (pipeline/p05-p06), c1a9efe (Bước 0), 25e8c40 (harness agy), 773c84e (Muse Part A+B), 65e72b5 (fix 6 findings), 0550d60 (xóa .tmp_hash.py), 42f615a (luật quản trị).
- Upstream check: pbakaus/impeccable Apache-2.0, 108.590★, push 12/11, 41 playbook — reference-only; Conradgui/zero-to-one-product-discovery license null, 6★ — từ chối (không license).
- P5 refs: đúng 2 repo — anthropics/knowledge-work-plugins (3 file verbatim, ~11,6 KB, blob SHA đối chiếu 4/4 MATCH) + pbakaus/impeccable (trích dẫn, không copy — playbook gọi binary Rust); cố ý không dùng design/skills/user-research (trùng P2 Discovery); 14 luật P5: 2 VERBATIM + 1 ADAPTED + 11 LOCAL (79% tự viết); accessibility-review ADAPTED (upstream WCAG 2.1, P5 ghi 2.2).
- P6 refs: 2 repo + 2 chuẩn (tên cụ thể xem Phần 2).
- Remediation plan: PROCESS 04 — REMEDIATION PLAN v0.3.1; NF-01…NF-12 (6 P0, 4 P1, 2 P2); T01–T18, 11 chiều mỗi dòng; 20 stress test; 13 trạng thái CR, 18 transition.
- 3 lỗi thật trong plan: (1) hash tự tham chiếu (ADR-P04-11); (2) plan nói HOLD/PENDING trong khi register nói APPROVED/GRANTED (16/16) — tạo P04-STATUS-RECONCILIATION-2026-11-12.md; (3) Skill dòng 118 (MIGRATE V2→V3) mâu thuẫn dòng 513 (V3→V4 WITH ZERO EXTERNAL CRS) — sửa thành chuỗi v2→v3→v4.
- P4 rating: đặc tả 4.5/5, implementation 3/5, bằng chứng 0/5, nhất quán 2/5.
- Probes: 130 kịch bản NOT RUN (P04 22, P05 53, P06 55); prompt test phủ ~5–7 (~5%). Probe 1: fixture gate_3 APPROVED nhưng hash 64 số 0; 3/7 check FAIL. Probe 2: COMPLIANT. Probe 3: COMPLIANT + 1 lỗi + 1 báo nhầm ("component"). Probe 4: VIOLATION — 2 tên field sai (status_before/status_after thay vì decision_status_before_update/decision_status_after_update), agent khai "Read-back passed: Yes". Probe 5: COMPLIANT — agent tự tìm thêm 3 lỗi không cài (gate_1/gate_2 approved_state_seq null, 6 artifact thiếu), từ chối, không ghi file nào.
- Findings F-01–F-06: F-01 "verify the Control File" không checklist; F-02 probe cần fixture P04; F-03 cột bắt buộc P05 không có nguồn ở P04 (nặng nhất); F-04 audit khớp substring (discards → card); F-05 tập khớp do reviewer định nghĩa; F-06 verify vòng tròn, không có schema (nặng nhì). Fix cả 6: commit 65e72b5, đã push; F-06 đóng bằng chạy lại probe.
- Probe 8 (sentinel): 3 lần thử — đọc Skill 500 dòng + Register 15KB thì treo ở bước 46/71; hỏi hẹp thì trả lời đúng; ghi với rule đưa sẵn thì hash sai (stored 03d756a9… vs computed dad68f94…), thử 18 biến thể ranh giới không cái nào khớp. F-08: Register không có máy kiểm; đã thêm validate-register.py; F-08 đóng bằng đặc tả (chưa chạy lại). F-09: validator khớp chuỗi "### CRE-" trong câu văn (cùng kiểu hỏng với F-04).
- agy 1.5.6 tại D:\Antigravity\agy\bin; headless -p/--print; TUI treo; harness phải ghi rõ cách gọi.
- Meta Muse: agent tiêu dùng, VM Meta, Sentinel giám sát, có shell thật.
- 6 file docs/: 354 dòng, thay 2.031 dòng skill; PRD.md 47 dòng; commit 793b894.
- Luật quản trị: 23 luật đã dán nhãn, 5 file nhắc luật "không được tự bịa", 0 validator; RULES.md + PROVENANCE.md; commit 42f615a.
- Chat: 169 tin nhắn (48 user + 121 assistant); model WorkBuddy AI (tên model không ghi trong đoạn trích).
- Kit trial: Prompt A dán với project_id = adr-ui; WorkBuddy trả THIẾU NGUỒN (không có SANITIZED_RAW_SOURCE dán kèm + repo dữ liệu 404).
18. Đã bỏ đi cố ý:
- Bỏ phần tán gẫu, câu hỏi lặp, và các đoạn trích dài về repo upstream (chỉ giữ kết luận + tên repo + license) — toàn văn vẫn nằm ở Phần 2.
- Bỏ nội dung đầy đủ của 3 prompt Antigravity, cấu trúc THE SEED v1.0, và toàn văn PROCESS 04 REMEDIATION PLAN v0.3.1 (649 dòng trích dẫn) — chỉ giữ quyết định + 3 lỗi thật + trạng thái NF-01…NF-12 — toàn văn ở Phần 2.
- Bỏ ảnh chụp màn hình (trong đoạn trích chỉ còn đường dẫn file ảnh) — ảnh không nằm trong file export.
- Ngoại lệ theo lệnh trực tiếp của user: block này chuẩn bị để đẩy lên repo dữ liệu đang PUBLIC ("Gấp luôn, kệ public"), trái với luật kit "Repo dữ liệu phải là repo PRIVATE — không bao giờ đẩy block, sổ gấp hay bản raw lên repo public". Nội dung đẩy lên GitHub nằm trong git history vĩnh viễn.

PHẦN 2 — SANITIZED_RAW_SOURCE (bản đã làm sạch; [REDACTED] = đoạn cố ý thiếu, không phải nguyên văn đầy đủ)

# Lịch sử chat: Pull repo and continue grilling feature development

**Thư mục dự án:** C:\Users\ducti\WorkBuddy AI\2026-11-12-15-51-45\app-adr-ui

**Tổng số lượt tin nhắn:** 169

---

### 👤 User

kimducanh27-cpu/app-adr-ui
dự án đang phát triên đã có 3 4 process rồi
còn những process sau nữa
đọc toàn bộ repo, pull và tiếp tục phát triển @skill:grilling

---

### 🤖 WorkBuddy AI

Repo public, truy cập được. Clone về workspace rồi đọc toàn bộ.

---

### 🤖 WorkBuddy AI

Đã clone và đọc hết repo. Trước khi hỏi, đây là những gì tôi tìm thấy — có vài điểm lệch so với giả định "3-4 process xong rồi":

**Thực trạng repo** (`app-adr-ui`, clone về `C:\Users\ducti\WorkBuddy AI\2026-11-12-15-51-45\app-adr-ui`)

- Đây **không phải repo code UI** . Nó là repo đặc tả quy trình "THE SEED" — 89 file, 5.842 dòng markdown, 118 commit. Mỗi process = 1 skill + 3 tab prompt + kit README + templates + Control File + gate + lệnh exact-command.
- `main` = 99ac2c6 (10/11), **không có gì để pull** . 4 process đã định nghĩa: 01 Seed → 02 Discovery → 03 Definition → 04 App Flow. README ghi rõ: *"four processes in a seven-process workflow. Later contracts must be added explicitly; do not infer them from numbering."*
- **Nhánh p04/implementation-v0.3.1: 7 commit tạo lúc 15:37–15:43 hôm nay** (8 phút trước), thêm schema v4 + Change Request Register. PR #1 đang **DRAFT / DO NOT MERGE** , merge authorization NOT GRANTED, Phase 6 **BLOCKED** bởi P0-IMP-01, Phase 7 NOT RUN.
- **Nhánh v3.0-p0-gate-enforcement** : 35 commit (09/11), lineage khác hẳn — README chỉ ghi `# Muse-mater-woker` . Nó **xóa sạch toàn bộ cây 4 process** , thay bằng `MUSE_ORCHESTRATOR.md` (spec orchestration VM/agy, tiếng Việt) + `docs/specs/phase-1..3` (design tokens → component → screen assembly) + `scripts/validate-gates.py` + test. Chưa merge, chưa rõ sống chết.
- **Không có một initiative thật nào** : `product/` chỉ có 4 file README. Không tồn tại `SEED.md` , `PRODUCT_DEFINITION.md` , `APP_FLOW.md` — tức process 05 không có input thật để chạy, và mọi "verification" từ trước tới nay vẫn là paper-check.

Vì vậy "tiếp tục phát triển process sau" không phải một việc tuyến tính. Đây là frontier hiện tại:

---

❓ **Q1** - **Trục nào là trục chính để xây 05?**: Ba dòng code đang tồn tại song song. (a) `main` — 4 process, schema v3; (b) `p04/implementation-v0.3.1` — schema v4, đang chặn; (c) `v3.0-p0-gate-enforcement` — orchestrator + phase 1-3, khác lineage. Process 05 phải đọc Control File của 04, nên contract của 04 quyết định contract của 05. Nếu chọn (c) thì toàn bộ mô hình 3-tab bằng markdown bị thay bằng orchestration tự động — 05 sẽ không còn là "process" nữa mà là một phase trong spec Muse.

➡️ **main là trục duy nhất** để định nghĩa 05/06/07. `v3.0-p0` là **sản phẩm khác** (build orchestrator), không phải contract của process thứ 5 — tách ra, không trộn. Bạn xác nhận "đúng"?

---

❓ **Q2** - **Xử lý bức tường P04 trước hay bỏ qua?**: P04-IMP-01 là lỗi thật: spec bắt mỗi event block chứa `event_block_sha256`, nhưng định nghĩa hash là SHA-256 của chính byte range **bao gồm** field đó → self-referential preimage, không tính được. Có 2 cách sửa: (1) sentinel — thay giá trị field bằng `<HASH_OMITTED>` trước khi hash, writer/reader normalize giống nhau; (2) bỏ field khỏi event body, chỉ lưu hash trong Control receipt. Điểm mấu chốt: **05 sẽ copy nguyên pattern event/receipt này** — không sửa thì 05 thừa kế đúng lỗi đó.

➡️ **Sửa bằng sentinel (cách 1), align spec + template + Skill, đóng Phase 6, rồi mới xây 05.** Đây là quyết định 1 dòng + 1 lượt sửa đồng bộ, rẻ hơn nhiều so với việc phát hiện lỗi lần hai trong 05. Bạn đồng ý chốt sentinel?

---

❓ **Q3** - **05/06/07 là gì?**: Repo cố tình không đặt tên. Process 04 chỉ nói "a later product-design process may derive UX/UI and visual design". Ba khả năng: (a) 05 = UX/UI Design (design system, wireframe, hi-fi, prototype spec) → 06 = Technical Architecture & Delivery Plan (API, data model, NFR, ticket) → 07 = Build/Verification/Release; (b) 05 = UX/UI → 06 = Build → 07 = Launch/Growth (bỏ tầng architecture); (c) chỉ định nghĩa 05, để 06/07 vô danh tiếp.

➡️ **(a)**, nhưng chỉ **05 được viết hợp đồng đầy đủ**; 06/07 chỉ nhận một charter 1 đoạn trong README (mục đích + input + output dự kiến), không có skill/template — đúng luật "later contracts must be added explicitly". Bạn chốt (a)?

---

❓ **Q4** - **Phiên này giao gì?**: Một process đầy đủ theo chuẩn 04 là ~1.000–1.500 dòng contract: skill (~300-400 dòng), 3 tab prompt, kit README, Control template schema riêng, 8–10 artifact template, verification checklist, decision log + review history. (a) làm trọn vertical slice cho 05; (b) chỉ viết charter/ADR cho 05 rồi dừng; (c) scaffold mỏng cả 05-07.

➡️ **(a) trọn vertical slice cho 05**, trên nhánh riêng `p05/implementation-v0.1.0`, **không merge, không push vào main** — giữ đúng văn hóa gate của repo. Bạn đồng ý?

---

❓ **Q5** - **Lấy gì để test 05?**: Entry gate của 05 cần một `APP_FLOW.md` đã freeze + Control File có hash khớp. Repo **không có** file nào như vậy, nên nếu không tạo fixture thì mọi thứ lại là paper-check — đúng cái mà chính repo đang tự cảnh báo. (a) tạo một fixture tổng hợp dưới `fixtures/reference-initiative/` (APP_FLOW.md tối thiểu nhưng hợp lệ, hash thật, Control File khớp); (b) chỉ paper-check; (c) dùng một ý tưởng sản phẩm thật của bạn làm fixture.

➡️ **(a) fixture tổng hợp**, đặt ngoài `product/` để không bao giờ bị nhầm là state thật. Bạn đồng ý?

---

Một giả định tôi giữ nguyên trừ khi bạn nói khác: **contract viết bằng tiếng Anh** như toàn bộ repo, trao đổi với bạn bằng tiếng Việt.

---

### 👤 User

Q1 tìm trên github để tiếp tục phát triển thêm P 5 6 7 8 9,....
Q4 chưa hiểu
Q5 cho ai khác reivew

---

### 🤖 WorkBuddy AI

Q4 tôi diễn đạt tối nghĩa, xin lỗi. Để tôi làm phần tra GitHub trước (đó là việc của tôi, không phải của bạn), rồi hỏi lại Q4 bằng ngôn ngữ cụ thể.

---

### 🤖 WorkBuddy AI

Đã tra xong. GitHub có sẵn đúng thứ bạn cần — và nó khớp gần như 1-1 với P5→P9.

## Những gì có trên GitHub

Repo `anthropics/knowledge-work-plugins` (Apache-2.0, 35k★) có 2 plugin chưa được document trong README nhưng tồn tại thật:

| Process | Upstream skill (đường dẫn chính xác) |
| --- | --- |
| P5 — UX/UI Design | design/skills/ → design-system, design-critique, design-handoff, ux-copy, accessibility-review |
| P6 — Technical Architecture | engineering/skills/ → architecture, system-design |
| P7 — Build/Implementation | engineering/skills/ → code-review, debug, tech-debt |
| P8 — QA/Verification | engineering/skills/ → testing-strategy, code-review |
| P9 — Release/Ops | engineering/skills/ → deploy-checklist, incident-response, documentation |

Đây là tin tốt về license: Apache-2.0, thoả điều kiện "preserve upstream verbatim" trong `UPSTREAMS.md`.

Nhưng có một điều phải nói thẳng: **upstream chỉ cấp domain knowledge, không cấp process contract.** Repo này không copy nguyên skill rồi gọi là "process". P1 đã làm đúng mẫu: copy `product-brainstorming` verbatim vào `.agents/skills/`, rồi tự viết adapter `seed-explore` + 3 tab prompt + Control File + gate. P5-P9 phải lặp lại đúng mẫu đó — upstream lo "làm thế nào để critique một design", repo lo "ai được ghi file nào, gate nào chặn, hash nào bind". Không có repo nào trên GitHub làm hộ bạn phần thứ hai. Tôi đã kiểm tra: không tồn tại repo nào có "gated 3-tab process contract" cho design/architecture.

---

❓ **Q4 (hỏi lại)** - **Buổi này tôi tạo ra file gì?**: Lần trước tôi nói trừu tượng. Cụ thể là: một process đầy đủ (như P4) gồm **~15 file** — 1 SKILL.md, 3 prompt tab, 1 kit README, 1 Control template, 8-9 artifact template, 1 verification checklist. Viết trọn 1 process là khối lượng lớn. Ba lựa chọn:

- (a) Viết **trọn bộ P5** ngay phiên này (~15 file, commit nhánh riêng) — nhưng P5 chỉ đúng nếu P5 đúng là "UX/UI Design".
- (b) Viết trước **5 tờ charter, mỗi tờ 1 trang** cho P5-P9 (mục đích, input, output, gate, upstream nào) — bạn duyệt 5 tờ đó, rồi tôi đổ chi tiết từng process.
- (c) Viết **khung sườn mỏng** cho cả 5 process cùng lúc.

➡️ **(b) rồi (a)**. Lý do: hiện chưa chốt được P5-P9 *là gì* (xem Q6 bên dưới), viết 15 file cho một process có thể sai vị trí là đốt công. 5 tờ charter chốt xong thì mỗi process còn lại chỉ là việc cơ học.

---

❓ **Q5 (làm rõ)** - **"Ai khác" review là ai?**: Bạn nói cho người khác review — cần biết cụ thể:

- (a) **Một agent khác, context sạch** , chỉ được đọc file và append finding, không được sửa artifact — đúng mô hình Tab 03 mà repo đang dùng.
- (b) **Người thật** đọc trên GitHub (PR review).
- (c) **Cả hai** : agent review trước, người duyệt sau.

➡️ **(a)**, vì nó khớp với kiến trúc "independent review tab" đã có, và chạy được ngay không cần chờ ai. Nếu sau này cần người thật thì thêm (b) như lớp gate cuối.

---

❓ **Q6 (mới, bắt buộc)** - **7 hay 9 process?**: README hiện khẳng định *"four processes in a seven-process workflow"*. Bạn vừa nói P5-P9 → tổng **9**. Hai con số này đá nhau, và nếu không sửa thì mọi contract viết sau đều mâu thuẫn với tài liệu gốc.

- (a) Chốt **9** , sửa README từ "seven" → "nine", viết charter cho cả 5.
- (b) Chốt **7** , nghĩa là chỉ còn P5, P6, P7 — "P8 P9" chỉ là nói vo.
- (c) Bỏ hẳn con số, README ghi "a numbered sequence, extended explicitly" — không hứa trước tổng số.

➡️ **(a) chốt 9**, nhưng gộp P8+P9 nếu P9 chỉ còn là deploy checklist — một process "Verify & Release" gọn hơn hai process nửa vời. Tức thực tế có thể là 8. Bạn muốn 9 cứng, hay 8 với P8 gộp?

---

Trả lời 3 câu này là tôi bắt tay viết được ngay, không hỏi thêm.

---

### 👤 User

yes to all
Q6 thật ra là chưa chốt 7 hay 9 chỉ khi nào đủ mới thôi, lúc đầu bàn là 7 nhưng trong quá trình phát triển lại phát sinh thêm(lúc đầu là seed, product discovery, app flow, ux design, design systems, ui design, validation)

---

### 🤖 WorkBuddy AI

Rõ. Vậy con số là **emergent** — không hứa trước, chỉ thêm khi đủ. Danh sách gốc bạn nêu cho thấy pipeline thật là 8 bước, không phải 7:

`Seed → Discovery → Definition → App Flow → UX Design → Design Systems → UI Design → Validation`

Product Definition là bước phát sinh thêm (không có trong list ban đầu), đúng như bạn nói. Tôi viết 4 tờ charter cho P5-P8, không bịa P9.

---

### 🤖 WorkBuddy AI

Xong. 4 tờ charter + sửa README, commit `c0b9d50` trên nhánh `charters/p05-p08-v0.1.0`. Chưa push (chưa có credential trong máy).

**Đã làm:**

| File | Nội dung |
| --- | --- |
| process-charters/README.md | Bảng 01-08, admission test 6 điều kiện để một stage được thành process riêng, 8 luật chung kế thừa từ P1-P4 |
| 05-UX-DESIGN.md | Từ "screen chạy được" → "screen hiểu được". Cấm màu/typography/component. Ra UX_SPEC.md |
| 06-DESIGN-SYSTEMS.md | Process đầu tiên được phép ra giá trị thị giác thật (hex, pt, spacing). Ra DESIGN_SYSTEM.md |
| 07-UI-DESIGN.md | Ghép screen từ component, mọi state, mọi breakpoint, copy cuối. Ra UI_SPEC.md |
| 08-VALIDATION.md | Chỉ tạo bằng chứng, không được sửa gì. Ra VALIDATION_REPORT.md |

Ba quyết định thiết kế đáng chú ý:

- **P6: component chỉ tồn tại nếu có ít nhất 1 screen cần nó** — inventory phải cite SCREEN ID, không cite được thì Gate 2 từ chối. Đây là thứ chặn design system phình ra.
- **P7: Gate 2 chạy so sánh tập hợp, không phải khẳng định** — screen ⊆ P4, component ⊆ P6, state = P5, mọi spacing phải có token. Trùng mô hình Gate 2 của P4.
- **P8: chưa chạy test thì là NOT RUN, không bao giờ là PASS** — cùng luật với Discovery ("no experiment run → no Outcome").

README gốc từng ghi *"seven-process workflow"* — tôi bỏ con số đó, thay bằng bảng sequence + câu "a number is a slot, not a promise". Đúng ý bạn: đủ mới thêm.

---

Còn 3 câu phải chốt trước khi viết contract P5:

❓ **Q7** - **Q2 lần trước bạn chưa trả lời**: P04 vẫn đang chặn ở P0-IMP-01 (hash tự tham chiếu). Tôi coi "yes to all" là đồng ý sửa bằng **sentinel** (`event_block_sha256: <HASH_OMITTED>` khi tính hash). Nếu đúng, tôi sửa spec+template+Skill của P04 trước, rồi P5 mới có input contract ổn định (v4). Nếu bạn muốn park v4, P5 sẽ bám v3.

➡️ Sửa sentinel, đóng Phase 6, rồi xây P5 trên v4.

---

❓ **Q8** - **UX spec có được vẽ không?**: Đây là quyết định định hình toàn bộ P5. Repo thuần markdown, không có hình. Ba cách: (a) chỉ chữ, hierarchy là list có thứ tự; (b) cho phép **khối ASCII/grid** trong artifact 01 — diff được, hash được; (c) cho phép ảnh ngoài, reference bằng SHA-256.

➡️ **(b) ASCII/grid**. Lý do: thuần chữ thì P6/P7 không có gì để bám vào về mặt không gian; ảnh thì không diff được, không review được trong PR. ASCII là điểm giữa duy nhất còn hash-anchored.

---

❓ **Q9** - **4 charter này có đúng không?**: Cụ thể là 3 ranh giới dễ sai: P5 không được đặt tên component (kể cả "button"); P6 không được nói component đặt ở đâu; P8 không được sửa bất cứ thứ gì, kể cả lỗi chính tả. Nếu một trong ba bị lỏng, scope sẽ chảy ngược.

➡️ Giữ nguyên cả ba. Bạn duyệt 4 charter để tôi bắt tay vào P5?

---

Nếu bạn không phản đối, tôi cũng chốt luôn 3 điểm nhỏ đang ghi trong charter P5: accessibility chia 3 tầng (P5 nêu yêu cầu / P6 cấp token / P8 đo), usability evidence muộn thì **reopen P5** chứ không đẩy sang P7, và P5 chỉ lo IA trong từng screen (IA xuyên screen là CR về P4).

---

### 👤 User

yes to all
Q2 là sao

---

### 🤖 WorkBuddy AI

Q2 là cái này — nó không phải lỗi code, nó là một mâu thuẫn logic trong đặc tả:

---

### 🤖 WorkBuddy AI

Q2 xong. Giờ dựng P5 thật. Trước hết xem cấu trúc Control File v4 để P5 kế thừa đúng khuôn:

---

### 🤖 WorkBuddy AI

Hai nhánh đang tách nhau — charters nằm trên nhánh khác với P04 v4. Gộp lại trước:

---

### 🤖 WorkBuddy AI

**Q2 là gì** — nó không phải lỗi code, mà là một mệnh đề tự mâu thuẫn trong đặc tả P04 v4:

Register v1 yêu cầu mỗi event block có trường `event_block_sha256`, và định nghĩa giá trị của nó là *SHA-256 của chính block đó, từ ### CRE- đến END_CRE*. Trường đó nằm **bên trong** vùng bytes được băm. Nên muốn tính hash phải có hash trước. Đây không phải bài toán khó — nó **không có nghiệm**: không tồn tại giá trị nào thoả cả hai vế cùng lúc. Một writer "chạy được" chỉ có thể là đang băm một thứ khác với thứ nó tuyên bố.

Hai cách sửa: (1) **sentinel** — trước khi băm, thay giá trị trường bằng một chuỗi cố định `<HASH_OMITTED>`, băm bản đã chuẩn hoá, rồi ghi digest thật vào; reader làm y hệt khi verify. (2) bỏ hẳn trường khỏi block, chỉ lưu hash trong Control receipt. Chọn (1) vì giữ nguyên cấu trúc field + receipt, chỉ đổi quy tắc preimage.

Điều làm nó nghiêm trọng: **P5 copy nguyên pattern event/receipt này**. Không sửa thì P5 thừa kế đúng lỗi đó, và lúc phát hiện sẽ đắt hơn nhiều.

**Đã sửa** (`194d77a`): định nghĩa lại preimage trong `SKILL.md` và Register template, ghi `ADR-P04-11`, thêm 2 stress test (ST-21/22 — dùng sentinel làm digest, và verify mà không thay sentinel), đóng Phase 6. Có một quyết định tôi cố ý làm: **không sửa file P04-REMEDIATION-PLAN-v0.3.1.md** dù nó chứa đúng câu sai — vì file đó là artifact đã duyệt, có SHA-256 ghi trong provenance, sửa vào là phá luôn dấu vết. ADR ghi rõ "superseded by reference, not by edit".

**P5 đã dựng xong** — 17 file, 1.379 dòng (`c9b0879`):

| Nhóm | File |
| --- | --- |
| Contract | .agents/skills/ux-design/SKILL.md (240 dòng) |
| Prompts | 3 tab trong prompts/05-UX-DESIGN/ |
| Templates | templates/05-UX-DESIGN/00–09 (10 file) |
| Kit | ux-design-kit/README.md + checklist 53 kịch bản |
| State | product/ux-design/README.md |

Ba thứ đáng chú ý trong thiết kế:

- **P5 verify P03 gián tiếp** qua hash mà P04 đã ghi, không đọc Control File của P03. Vì P5 không được phép sờ vào P03, và bịa field ở đó là đúng cái lỗi P04 vừa mắc.
- **Ba cuộc kiểm tra từ vựng** chạy ở Gate 2 và ở review: không tên component, không giá trị màu/font/spacing, không copy cuối. Đây là boundary dễ vỡ nhất — gọi một cái "button" ở P5 là biến P6 thành con dấu.
- **Khối ASCII** được phép trong artifact 01, nhưng **không có thẩm quyền** : list thứ tự ở trên mới là hợp đồng, hai cái lệch nhau thì khối là lỗi.

Nhánh `p04/implementation-v0.3.1` hiện **12 commit trước main, 0 sau**, 39 file, +3.573 dòng. Chưa push (máy chưa có credential).

---

Một điều phải nói thẳng: **toàn bộ P5 vẫn là giấy.** 53 kịch bản đều `NOT RUN`, vì không tồn tại `APP_FLOW.md` nào đã freeze trong repo. Không có nó thì không thể chạy tab nào, và mọi tuyên bố "P5 hoạt động" sẽ là bịa.

❓ **Q10** - **Lấy input thật ở đâu?**: (a) tôi dựng một **initiative mẫu** đầy đủ P1→P4 (một sản phẩm nhỏ, giả định, khoảng 6-8 screen) để P5 có thể chạy thật và checklist có evidence; (b) bạn đưa một ý tưởng thật, tôi chạy P1→P4 trên đó rồi mới tới P5; (c) bỏ qua, xây tiếp P6 trên giấy rồi test cả chuỗi một lần sau.

➡️ **(a)**. Nó biến 53 dòng `NOT RUN` thành evidence thật, và cái fixture đó sẽ dùng lại được cho P6, P7, P8 — không chỉ P5.

---

### 👤 User

@long-text:"The seed->..." <long_text_quote>The seed->app flow->UX ->UI
Wuy trình này để dựng UI app adr được không?? Hay như nào
Bạn them khaot github giúp
Được. Quy trình Seed → App Flow → UX → UI là một nền tảng hợp lý để dựng giao diện ứng dụng Android bằng AI Agent.

Tuy nhiên, mình khuyên nên mở rộng thành 7 giai đoạn. Nếu giữ nguyên 4 giai đoạn, agent rất dễ hiểu sai sản phẩm, tự tưởng tượng chức năng hoặc tạo ra UI đẹp nhưng trải nghiệm sử dụng kém.

Mình đã tìm và đối chiếu một số repo GitHub có workflow liên quan. Có một repo đặc biệt đáng chú ý là pbakaus/impeccable.

1. Quy trình mình đề xuất
SEED — Ý tưởng ban đầu

Xác định ứng dụng muốn giải quyết vấn đề gì, dành cho ai, khác biệt ở đâu.

Đầu ra: Product Idea / Initial Brief

PRODUCT DISCOVERY — Khám phá sản phẩm

Làm rõ đối tượng sử dụng, nhu cầu, tính khả thi, phạm vi MVP và chức năng thực sự cần thiết.

Đầu ra: Product Brief / MVP Scope

APP FLOW — Kiến trúc và luồng ứng dụng

Xây dựng cấu trúc màn hình, điều hướng, luồng thao tác và mối quan hệ giữa các chức năng.

Đầu ra: App Map / User Flow / Screen Inventory

UX DESIGN — Thiết kế trải nghiệm

Quyết định cách người dùng tương tác với từng màn hình, bố cục thông tin, hành vi nút bấm, trạng thái và phản hồi.

Đầu ra: Wireframes / UX Specification / Interaction Flow

DESIGN SYSTEM — Nền tảng thiết kế

Xây dựng màu sắc, typography, spacing, icon, component, quy tắc sử dụng và các biến thể.

Đầu ra: Design Tokens / Components / Design Guidelines

UI DESIGN — Thiết kế giao diện hoàn chỉnh

Chuyển wireframe thành giao diện trực quan, tạo các màn hình độ trung thực cao và prototype tương tác.

Đầu ra: High-fidelity UI / Interactive Prototype

VALIDATION — Kiểm tra và hoàn thiện

Đánh giá tính nhất quán, khả năng sử dụng, accessibility, giao diện trên thiết bị thật và sửa các vấn đề trước khi triển khai.

Đầu ra: Approved UI / UX Review / QA Report

Điểm cần lưu ý: App Flow thực chất là một phần của UX, cụ thể là Information Architecture và User Flow. Mình tách nó thành một giai đoạn riêng để agent có thể tạo và kiểm duyệt đầu ra độc lập.

1. Những repo GitHub đáng tham khảo
Mình chia thành 3 nhóm vì không nên dùng một repo để giải quyết toàn bộ quy trình.

Nhóm A — Product Discovery và UX
GitHub - pengshn6/chaoxing-1: Make Github to help u for signing on Superstar Xuexitong every 5 minutes, base on github actions. · GitHub

1. zero-to-one-product-discovery

Đáng tham khảo cho giai đoạn Seed

Conradgui

Xem repository
Workflow đi từ ý tưởng chưa hoàn chỉnh đến product discovery, problem framing, solution exploration, feasibility và MVP hypothesis. Có stage gates để tránh tạo tài liệu khi chưa đủ căn cứ.

Impeccable User Guide — Complete reference for the Impeccable frontend design skill set for Claude Code · GitHub
2. Impeccable

Mình đánh giá cao nhất
pbakaus

Xem repository
Có quy trình thiết kế và cải thiện UI/UX, hỗ trợ native Android, UX critique, audit, polish, onboarding, typography, layout và design system.

Điều đặc biệt ở Impeccable là nó không yêu cầu agent lập tức viết code.

Skill shape có các bước:

Discovery interview: tìm hiểu mục đích, người dùng và kết quả mong muốn.

Resolve design direction: xác định hướng thiết kế.

Write the brief: tạo bản thiết kế được xác nhận trước khi triển khai.

Nó còn yêu cầu xem xét các trạng thái first-run, loading, empty, error, success và permissions. Đây là những thứ thường bị AI bỏ quên khi chỉ giao nhiệm vụ thiết kế màn hình.

GitHub
+1

Một số tài liệu riêng đáng đọc:

Shape: UX/UI discovery

Android platform guidelines

UX critique

Quality audit

Nhóm B — Android UI và Design System
Jetpack Compose Logo & Brand Assets (SVG, PNG and vector) - Brandfetch
3. android/compose-samples

Nguồn chính thức Google
Xem repository
Có nhiều ứng dụng mẫu Jetpack Compose. Đặc biệt chú ý Jetsnack (custom design system) và Reply (adaptive UI, Material 3).

Ya puedes ver los nuevos iconos de Google: así se renueva la imagen de Gmail, Drive, Docs y más
4. android/nowinandroid

Nguồn chính thức Google
Xem repository
Ứng dụng Android hoàn chỉnh, có kiến trúc, navigation, UI, theming, modularization và hướng dẫn thiết kế/triển khai.

Hai repo này phù hợp hơn ở giai đoạn triển khai, không thay thế quy trình Product Discovery hoặc UX.

GitHub
+1

Nhóm C — Android Design Guidelines
Material Design 3 要点まとめ #5 Interaction states｜パジェロ｜COMPASS
5. Material Design 3

Nền tảng Android nên tham khảo
Tài liệu chính thức
Hướng dẫn về design foundations, component, navigation, selection, text input và design system.

Google định nghĩa Design System không chỉ là một tài liệu hướng dẫn, mà còn bao gồm các quyết định thiết kế tái sử dụng, component và pattern.

Android Developers

1. Một điểm rất quan trọng khi dựng UI Android
Không nên chỉ yêu cầu AI tạo một file DESIGN.md.

Nên yêu cầu tạo một Design System có cấu trúc thực sự:

Thành phần

Nội dung

Foundations

Color, typography, spacing, shape

Tokens

Các biến thiết kế dùng chung

Components

Button, Card, Input, Dialog...

Variants

Các trạng thái và biến thể component

Patterns

Navigation, onboarding, forms...

Guidelines

Khi nào và cách sử dụng từng component

Implementation

Component tái sử dụng trong code Android

Và phải có quy tắc Android riêng: Material 3, system Back, window insets, navigation phù hợp kích thước màn hình, dark mode và accessibility. Không nên bê nguyên giao diện iOS sang Android.

GitHub
+1

1. Kiến trúc kết hợp mình khuyên dùng
Đây là cách mình sẽ ghép các repo trên thành một pipeline cho AI Agent:

Android App Design Pipeline
01 — Product Discovery

Tham khảo Zero-to-One Product Discovery

Product Brief · MVP · Requirements

02 — UX Architecture

App Map · User Flow · Screen Inventory

03 — UX Design

Tham khảo Impeccable Shape

Wireframes · Interaction · States

04 — Design System

Material 3 + Custom Design System

Tokens · Components · Guidelines

05 — High-fidelity UI

Full Screens · Prototype · Motion

06 — Independent Design Review

UX Critique · Visual QA · Accessibility

Có lỗi thì quay lại giai đoạn tương ứng

07 — UI Implementation

Jetpack Compose hoặc framework Android đã chọn

Emulator QA · Screenshot Review

1. Kết luận
Mình chọn cách kết hợp:

Zero-to-One Product Discovery: xử lý ý tưởng và xác định đúng sản phẩm.

Impeccable: xử lý quy trình UX/UI, thiết kế và kiểm duyệt.

Material 3: nền tảng quy tắc giao diện Android.

Compose Samples + Now in Android: tham khảo cách biến thiết kế thành ứng dụng thực tế.

Điều quan trọng nhất: các giai đoạn phải có đầu ra và điều kiện nghiệm thu riêng. Agent UI không được tự ý thay đổi luồng sản phẩm; agent UX không được tự ý sáng tác chức năng; agent triển khai phải tuân thủ Design System đã duyệt.

Mình thiên về xây dựng pipeline theo hướng này thay vì chỉ dùng một prompt lớn kiểu "hãy thiết kế ứng dụng Android thật đẹp".

[https://claude.dev/blog/solving\-code\-review\-at\-anthropic/](https://claude.dev/blog/solving-code-review-at-anthropic/)
Bây giờ tập trung vào the seed
Tôi thì thích kiểu tạo quy trình rồi tab skill đưa prompt cho antigravity làm út phải đụng tay chân nhưng kh nên tự động hoá cao quá vì dễ lỏ

Bạn giúp tôi tìm skill phù hợp
Lên ý tưởng prompt, quy trình,.....v.v..v.v.v.v.v.v.v.v.v.v.v
Mình hiểu cách bạn muốn vận hành: AI làm phần lớn công việc tư duy, nghiên cứu và chuẩn bị tài liệu; bạn điều khiển quy trình, duyệt các quyết định quan trọng và không để agent tự ý chạy hết pipeline.

Mình đề xuất một mô hình gọi là Human-Gated Seed Workflow.

Đặc biệt, mình nghĩ nên học tư duy từ bài Anthropic bạn gửi, nhưng không bê nguyên cơ chế Code Review vào quy trình thiết kế sản phẩm.

1. Trước tiên: The Seed phải giải quyết việc gì?
The Seed không phải là viết PRD, cũng không phải thiết kế UI.

Nó có nhiệm vụ biến:

RAW IDEA

"Tôi muốn làm một ứng dụng Android có AI..."

Tìm hiểu · Phản biện · Mở rộng · Nghiên cứu

SHAPED SEED

Ai thực sự cần ứng dụng?

Vấn đề nào cần giải quyết?

Tại sao những giải pháp hiện tại chưa tốt?

Có những hướng giải quyết nào?

Hướng nào đáng đầu tư tiếp?

Những giả định nào chưa được chứng minh?

SEED DECISION

Proceed

Tiếp tục
Reframe

Định hình lại
Hold

Tạm dừng
Đầu ra cuối cùng chỉ nên là một tài liệu SEED.md, chưa phải PRD hoàn chỉnh.

1. Skills GitHub mình chọn
Mình đã tìm được hai skill rất phù hợp. Chúng bổ sung cho nhau thay vì làm cùng một công việc.

Skill 1 — Product Brainstorming
Logo Anthropic – Logos PNG
anthropics/knowledge-work-plugins

Lựa chọn chính
GitHub – Product Brainstorming
product-management/skills/product-brainstorming/SKILL.md

Đây là skill mình thích nhất cho giai đoạn đầu.

Nó định nghĩa AI là một product thinking partner, không phải máy tạo tài liệu.

Có bốn chế độ rất đáng dùng:

Chế độ

Mục đích

Problem Exploration

Khám phá vấn đề gốc

Solution Ideation

Tìm nhiều hướng giải quyết

Assumption Testing

Kiểm tra giả định

Strategy Exploration

Khám phá định hướng

Một số nguyên tắc đặc biệt tốt:

Không vội nhảy từ vấn đề sang giải pháp.

Tạo 5–7 hướng khác nhau trước khi đánh giá.

Có phương án đi ngược lại suy nghĩ thông thường.

Phân biệt brainstorming và decision-making.

Tìm cách thử giả định rủi ro nhất trước khi xây dựng.

Điểm mình đánh giá cao: skill này không tự ép mình phải tạo ra PRD sau mỗi cuộc trò chuyện.

GitHub
+1

Skill 2 — Product Shaping
Is GitHub down? | GitHub outage details
ferminrp/agent-skills

Lựa chọn bổ trợ
GitHub – Product Shaping
skills/product-shaping/SKILL.md

Skill này xử lý một vấn đề rất quan trọng: AI không biết hết những gì bạn đang nghĩ và bạn cũng không biết hết những gì cần phải quyết định.

Nó phân loại thông tin thành bốn nhóm:

Nhóm

Ý nghĩa

Known Knowns

Đã biết, đã xác nhận

Known Unknowns

Biết rằng chưa có quyết định

Unknown Knowns

Chỉ nhận ra điều mình thích khi nhìn thấy

Unknown Unknowns

Những điểm chưa hề nghĩ tới

Quy trình của nó:

Starting Point.

Blind Spot Research.

Brainstorm Directions.

References.

Interview.

Shaping Document.

Gut Check.

Đặc biệt, nó yêu cầu hỏi từng câu một, ưu tiên câu hỏi có thể thay đổi hướng sản phẩm thay vì hỏi tiểu tiết. Tài liệu cuối cùng chỉ cần định hình vấn đề, cơ chế giải pháp và ranh giới, không đi quá sâu vào implementation.

GitHub
+1

Lưu ý: Skill này có chức năng tạo prototype HTML trong một số trường hợp. Mình sẽ không bật mặc định tính năng đó ở The Seed. Chỉ dùng prototype khi cần giải quyết sự mơ hồ mà lời nói không đủ diễn đạt.

Skill 3 — Chưa nên dùng
Github Black Icons – Free Download SVG, PNG, GIF
elcodabra/validate-idea-skills

Để giai đoạn sau
GitHub repository
Repo này có quy trình 8 bước: nghiên cứu đối thủ, giá trị sản phẩm, landing page, smoke test, kéo người dùng, pre-sale và quyết định GO/PIVOT/KILL.

Nó thiên về xác thực nhu cầu thị trường và kinh doanh hơn là định hình ý tưởng ban đầu. Chưa cần cài toàn bộ vào The Seed.

GitHub

1. Quy trình The Seed mình đề xuất
Mình không muốn biến nó thành một orchestrator tự động gọi 7 agent.

Thay vào đó: 5 chặng, 3 tab làm việc chính, mỗi chặng có một điểm dừng để bạn quyết định.

THE SEED — Manual-gated workflow
TAB 01 — Explore

Brainstorm
01. Idea Intake

Nhận ý tưởng ban đầu, không ép người dùng phải viết brief hoàn chỉnh.

1. Problem Exploration

Tìm người dùng, hoàn cảnh, vấn đề và giải pháp hiện tại.

1. Divergent Thinking

Mở rộng 5–7 hướng giải quyết, chưa vội chọn.

Human Gate 01: Bạn xác nhận vấn đề cần giải quyết.

TAB 02 — Investigate

Research
04. Blind Spot Research

Tìm các giải pháp tương tự, đối thủ, khoảng trống, giới hạn kỹ thuật và những điều bạn có thể chưa nghĩ tới.

1. Assumption Challenge

Tìm giả định nguy hiểm nhất, phân biệt dữ kiện với suy đoán.

Human Gate 02: Bạn chọn hướng sản phẩm đáng tiếp tục.

TAB 03 — Shape & Review

Decision
06. Product Shaping

Định hình cơ chế sản phẩm, phạm vi sơ bộ và những điều không làm.

1. Independent Review

Một lượt phản biện độc lập, tìm lỗ hổng và kiểm tra tài liệu có phản ánh đúng ý tưởng của bạn không.

1. Seed Freeze

Viết SEED.md sau khi bạn duyệt.

Human Gate 03: Bạn quyết định Proceed / Reframe / Hold.

Mấu chốt: mỗi tab nhận tài liệu bàn giao từ tab trước. Không yêu cầu agent tự gọi tab tiếp theo, không tự sinh một chuỗi agent.

1. Cách vận dụng bài Anthropic bạn gửi
Bài viết về quy trình Code Review của team Claude Code có một số nguyên tắc rất đáng chuyển sang quy trình này.

Theo nội dung bài viết, con người vẫn chịu trách nhiệm quyết định hướng đi, phạm vi và các quyết định quan trọng; agent có thể thực hiện nhiều công việc kiểm tra, nhưng phải đưa ra bằng chứng để người duyệt đánh giá. Bài cũng nhấn mạnh cần giới hạn vòng review để tránh agent và agent liên tục sửa những vấn đề cũ.

[claude.dev](http://claude.dev) Blog
+1

Mình chuyển thành các quy tắc cho The Seed:

Nguyên tắc

Áp dụng

Human owns direction

Bạn quyết định sản phẩm

Evidence over claims

Agent phải đưa nguồn, không nói suông

Independent review

Có lượt phản biện bằng ngữ cảnh riêng

Risk-based review

Giả định ảnh hưởng lớn phải được xem xét kỹ

Round cap

Tối đa 3 vòng phản biện

Human accountability

Bạn duyệt tài liệu cuối

Có một ý đặc biệt quan trọng: Agent phải chứng minh rằng nó đã làm đúng, không chỉ nói rằng nó đã hoàn thành.

Ví dụ, khi nghiên cứu đối thủ, agent phải cung cấp nguồn, điều đã xác minh, điều còn chưa chắc và tác động đến ý tưởng. Không được tự bịa ra khoảng trống thị trường.

1. Bộ prompt sử dụng với Antigravity
Mình đề xuất bắt đầu bằng ba prompt chính. Đây là các prompt để bạn chủ động gọi từng giai đoạn, không phải một prompt tự chạy toàn bộ.

Prompt 01 — Seed Exploration
Dùng trong TAB 01, gọi Product Brainstorming.

We are entering THE SEED phase of an Android application project.

ROLE:
Act as a senior product strategist and critical thinking partner.
Do not behave like a passive assistant or a document generator.

OBJECTIVE:
Help me transform a raw idea into a clearly understood
product opportunity.

OPERATING RULES:

1. Start with problem exploration, not solution design.
2. Understand the target user, their situation, their
current workaround, and the actual problem.
3. Distinguish symptoms from root causes.
4. Challenge assumptions and ask uncomfortable questions.
5. Ask ONE question at a time and wait for my response.
6. Keep a visible distinction between:

 - Confirmed facts
 - My opinions
 - Your hypotheses
 - Unresolved questions

BRAINSTORMING:

After the problem is sufficiently understood:

- Generate 5-7 genuinely different product directions.
- Include conventional, unconventional, and ambitious options.
- Do not prematurely rank or discard ideas.
- Explain the core mechanism of each direction.

STRICT BOUNDARIES:

- Do not write a PRD.
- Do not design UI.
- Do not create wireframes or prototypes.
- Do not write application code.
- Do not automatically start another phase.
- Do not make product decisions on my behalf.

INTERACTION:
Keep each interaction focused.
Do not overwhelm me with a questionnaire.

STOP CONDITION:
Stop when you have enough information to present:

1. A clear problem statement.
2. The target user and context.
3. The current workaround.
4. The main unresolved assumptions.
5. A set of distinct product directions.

Wait for my approval before proceeding.
Prompt 02 — Blind Spot Research
Dùng trong TAB 02.

We are continuing THE SEED process.

Your task is to investigate the selected product opportunity.

RESEARCH OBJECTIVES:

1. Identify comparable products and existing solutions.
2. Identify how users currently solve this problem.
3. Find overlooked opportunities and weaknesses.
4. Investigate relevant Android technical constraints.
5. Identify assumptions that could invalidate the idea.

RESEARCH RULES:

- Search GitHub and relevant public sources where appropriate.
- Prefer primary documentation and actual project repositories.
- Verify whether repositories are maintained.
- Cite every important factual claim.
- Separate facts, interpretations and hypotheses.
- Never invent market demand or user feedback.
- Do not confuse missing features with real user problems.

OUTPUT:

A. Relevant findings.
B. Comparable products.
C. Existing solutions and limitations.
D. Potential opportunities.
E. Technical or practical risks.
F. Riskiest assumptions.
G. Questions requiring my decision.

LIMITS:

Only investigate findings that could materially change
our product direction.

Do not write a PRD.
Do not create UI.
Do not implement anything.
Do not autonomously continue to the next phase.

Present your findings and wait for my review.
Prompt 03 — Independent Seed Review
Dùng trong TAB 03, tốt nhất là một conversation mới để hạn chế bị ảnh hưởng bởi những kết luận trước đó.

Act as an independent senior product reviewer.

Review the proposed product seed and its supporting research.

You are NOT the author of this idea.

Your responsibilities:

1. Identify unsupported claims.
2. Identify contradictions.
3. Identify problems that have been mistaken for features.
4. Challenge whether the proposed solution is necessary.
5. Identify overlooked user groups and scenarios.
6. Find the strongest argument against this product.
7. Identify the riskiest unresolved assumption.
8. Suggest a cheaper way to resolve that assumption.

EVIDENCE RULES:

Every finding must include:

- The specific claim being reviewed.
- Why it may be incorrect.
- Supporting evidence or missing evidence.
- Its potential impact.

Do not invent findings to appear thorough.

REVIEW LIMITS:

- Prioritize substantive issues.
- Avoid cosmetic suggestions.
- Do not rewrite the whole document.
- Maximum three review rounds.
- Do not automatically approve the product.

FINAL RESULT:

Return:

- Critical issues.
- Important uncertainties.
- Recommended corrections.
- Whether the seed is sufficiently shaped.

The human makes the final decision.
6. Cấu trúc tài liệu bàn giao
Không nên sinh 10–15 file cho The Seed. Một vài tài liệu nhỏ, rõ ràng sẽ dễ kiểm soát hơn.

product/
└── seed/
├── SEED.md
├── RESEARCH_NOTES.md
└── DECISION_LOG.md
File

Vai trò

SEED.md

Định hình ý tưởng cuối cùng

RESEARCH_NOTES.md

Những phát hiện có nguồn

DECISION_LOG.md

Các quyết định do bạn duyệt

Nội dung SEED.md dự kiến:

# Product Seed

## 1. Product Idea

## 2. Target User

## 3. User Problem

## 4. Current Alternatives

## 5. Desired Outcome

## 6. Product Hypothesis

## 7. Core Differentiation

## 8. Product Boundaries

## 9. Confirmed Facts

## 10. Unvalidated Assumptions

## 11. Biggest Risks

## 12. Open Questions

## 13. Seed Decision

Đừng biến nó thành một PRD dài. Chưa cần liệt kê tất cả màn hình, chức năng hay database.

1. Đưa vào Antigravity như thế nào?
Tài liệu Google hiện ghi nhận Agent Skills sử dụng định dạng mở SKILL.md, mặc định nằm trong .agents/skills/. Đối với Antigravity IDE, bạn có thể kiểm tra các skill đã được phát hiện trong Customizations ở agent side panel.

Google Antigravity Docs

Cấu trúc đề xuất:

.agents/
└── skills/
├── product-brainstorming/
│ └── SKILL.md
│
└── product-shaping/
├── SKILL.md
└── references/
├── prototype-guide.md
└── shaping-doc-template.md
Không cần tạo một bộ skill khổng lồ.

Mình sẽ giữ hai skill riêng biệt, bởi tài liệu Antigravity cũng khuyến nghị mỗi skill nên tập trung giải quyết một nhiệm vụ cụ thể.

Google Antigravity Docs

1. Quyết định kiến trúc mình đề xuất
Khuyến nghị Human-Gated, Skill-Driven, Artifact-Based.

Thành phần

Mức tự động

Ý tưởng và câu hỏi

Agent hỗ trợ

Brainstorming

Agent thực hiện

Research

Agent thực hiện có nguồn

Assumption analysis

Agent thực hiện

Chọn hướng sản phẩm

Bạn quyết định

Independent review

Agent thực hiện

Tạo SEED.md

Sau khi bạn duyệt

Chuyển sang App Flow

Bạn kích hoạt thủ công

Đặc biệt, mình không khuyên bạn dùng Subagents ở The Seed. Một agent chính với các skill chuyên biệt sẽ dễ kiểm soát hơn; chưa có lý do để thêm orchestration phức tạp.

1. Có ba quyết định mình muốn chốt với bạn trước khi xây bộ Skill hoàn chỉnh
2. Phong cách AI trong The Seed

Sparring Partner

AI thường xuyên chất vấn, phản biện, không dễ đồng ý với bạn.

Balanced Product Consultant

Cân bằng giữa hỗ trợ ý tưởng và phản biện.

Product Facilitator

Dẫn dắt từng bước, chủ yếu hỏi và giúp bạn tự tìm câu trả lời.

1. Mức độ nghiên cứu

Targeted Research

Chỉ tìm những thông tin có thể làm thay đổi quyết định.

Deep Research

Phân tích sâu đối thủ, GitHub, công nghệ và hệ sinh thái.

Adaptive Research

AI tự đề xuất mức nghiên cứu, bạn duyệt trước khi thực hiện.

1. Cách tổ chức công việc trong Antigravity

3 tab độc lập

Explore → Investigate → Review.

Một tab tuần tự

Dùng nhiều skill nhưng giữ chung ngữ cảnh.

Hybrid

Một tab chính giữ ngữ cảnh, tab phụ chỉ làm research và review.

Ý kiến của mình: chọn Sparring Partner + Targeted Research + Hybrid. Cách này giảm đáng kể thao tác lặp lại, vẫn giữ được khả năng kiểm soát và tránh biến Antigravity thành một hệ thống tự động phức tạp mà bạn khó biết nó đang làm gì.

Chốt cấu hình The Seed của tôi: Phong cách AI = sparring; Nghiên cứu = deep; Tổ chức Antigravity = three. Hãy dựa vào các lựa chọn này để thiết kế bộ Skill và prompt hoàn chỉnh.
Đã chốt cấu hình. Mình đã thiết kế và đóng gói THE SEED — Antigravity Kit v1.0 thành bộ Skill và Prompt có thể đưa trực tiếp vào workspace Android.

THE SEED v1.0
Đã tạo bộ tài liệu
01
Sparring

AI personality

02
Deep

Research depth

03
Independent

3 tabs

Tải bộ hoàn chỉnh

THE_SEED_Antigravity_Kit_v1.zip

3 Skills · 3 Prompts · 5 Templates · README

25 KB
Tải Antigravity Kit v1.0

1. Kiến trúc đã chốt
TAB 01 — EXPLORE

Sparring
/seed-explore
AI hỏi, phản biện, tìm vấn đề gốc, brainstorm 5–7 hướng khác nhau.

Tạo:

01_SEED_CANDIDATE.md

03_DECISION_LOG.md

GATE 1 — Bạn duyệt vấn đề và hướng nghiên cứu

TAB 02 — INVESTIGATE

Deep Research
/seed-research
Tìm đối thủ, giải pháp thay thế, GitHub, bằng chứng người dùng và ràng buộc Android.

Tạo:

- 02_RESEARCH_DOSSIER.md

GATE 2 — Bạn duyệt bằng chứng và lựa chọn

TAB 03 — REVIEW

Independent
/seed-independent-review
Reviewer ở conversation mới, kiểm tra độc lập, tìm mâu thuẫn, giả định thiếu căn cứ và điểm yếu sản phẩm.

Tạo:

04_SEED_REVIEW.md

SEED.md chỉ khi bạn ra lệnh đóng băng.

GATE 3 — Bạn quyết định FREEZE SEED

1. Cấu trúc file
.agents/
└── skills/
├── seed-explore/
│ └── SKILL.md
├── seed-research/
│ └── SKILL.md
└── seed-independent-review/
└── SKILL.md

prompts/
├── 01-TAB-EXPLORE.md
├── 02-TAB-DEEP-RESEARCH.md
└── 03-TAB-INDEPENDENT-REVIEW.md

templates/
├── 01-SEED-CANDIDATE.md
├── 02-RESEARCH-DOSSIER.md
├── 03-DECISION-LOG.md
├── 04-SEED-REVIEW.md
└── 05-SEED-FINAL.md

product/
└── seed/
Các file đã được viết đầy đủ, không phải skeleton để bạn tự điền quy tắc.

1. Những nguyên tắc mình đã đưa vào
Sparring không phải phản đối vô lý.

AI phải đưa ra phản biện mạnh nhất, giải thích tại sao lập luận có vấn đề, nhưng cũng phải chấp nhận khi bạn có bằng chứng tốt.

Deep Research không phải thu thập thật nhiều link.

Mỗi phát hiện phải có nguồn, bằng chứng, độ tin cậy, giới hạn và tác động đến quyết định sản phẩm. GitHub stars không được coi là bằng chứng nhu cầu thị trường.

Independent Review thực sự độc lập.

Tab 03 không được dựa vào những gì hai tab trước tự nhận là đã hoàn thành. Nó đọc artifact từ workspace và tự kiểm tra.

Mình áp dụng nguyên tắc từ bài Anthropic: review phải hạn chế noise, không lặp finding và có giới hạn ba vòng để tránh việc hai agent sửa và phản biện vô tận. Con người vẫn giữ quyền quyết định hướng đi và chịu trách nhiệm phê duyệt.

[claude.dev](http://claude.dev) Blog
+1

1. Cách cài đặt
Giải nén ZIP vào thư mục gốc dự án Android. Nếu đã có .agents/, hãy gộp thư mục, không xóa các skill hiện có.

Mở Antigravity IDE.

Vào Customizations trong Agent Side Panel, kiểm tra ba skill.

Mở ba conversation độc lập, cùng workspace.

Copy prompt tương ứng từ thư mục prompts/.

Lưu ý: tài liệu Antigravity xác nhận vị trí .agents/skills/ và việc kiểm tra skill trong Customizations của IDE. Slash command được tài liệu mô tả rõ cho App và CLI; nếu IDE của bạn không hiển thị /seed-explore, hãy dùng prompt wrapper có sẵn trong gói.

Google Antigravity Docs

1. Tại sao mình chưa thêm những skill khác?
Mình cố ý không đưa Impeccable, UI generator hay PRD generator vào The Seed.

Đây là ranh giới quan trọng:

The Seed: tìm ra đúng sản phẩm.

App Flow: xác định cấu trúc và điều hướng.

UX: giải quyết trải nghiệm.

UI: thiết kế giao diện.

product-brainstorming của Anthropic và product-shaping của ferminrp đã cung cấp những nền tảng tư duy phù hợp cho hai phần đầu; bộ mới là lớp điều phối thủ công và kiểm soát chất lượng dành cho quy trình ba tab của bạn.

GitHub
+1

Khuyến nghị: Đừng bổ sung thêm skill vào The Seed ở thời điểm này. Hãy thử bộ v1 với một ý tưởng Android thực tế, xem ba tab có bàn giao đúng tài liệu và giữ đúng quyền quyết định hay không. Sau đó mới chỉnh v2 dựa trên lỗi thực tế, thay vì tiếp tục tăng độ phức tạp trước khi chạy thử.

Skill bạn lấy nguyên văn hay lấy khung thôi
Mình lấy khung tư duy và phương pháp, không lấy nguyên văn toàn bộ Skill. Bộ THE SEED v1.0 là bộ Skill mình viết lại và tùy chỉnh cho quy trình của bạn.

Cụ thể:

Nguồn

Phần kế thừa

Phần mình phát triển

Anthropic Product Brainstorming

Problem exploration, divergent thinking, assumption testing

Skill seed-explore, cơ chế Sparring và Gate 1

ferminrp Product Shaping

Known/Unknowns, blind spots, shaping

Quy trình bàn giao Candidate và Gate 2

Anthropic Code Review

Independent review, evidence-based findings, giới hạn vòng review

Skill seed-independent-review, tối đa 3 vòng

Google Antigravity

Cấu trúc Agent Skills

Cấu trúc .agents/skills/ và cách gọi qua prompt

Những gì mình tự thiết kế thêm:

Ba Skill có trách nhiệm riêng, không chồng chéo.

Cơ chế ba tab độc lập.

Artifact-based handoff: agent giao tiếp bằng file thay vì dựa vào lịch sử chat.

Human Approval Gates: không tự chuyển giai đoạn.

Quy tắc không tự ý viết PRD, App Flow, UX/UI.

Điều kiện FREEZE SEED để khóa tài liệu cuối cùng.

Một điểm mình muốn làm rõ: mình chưa thực hiện kiểm tra đạo văn theo kiểu diff từng dòng với toàn bộ phiên bản upstream. Vì vậy, mình không khẳng định không có bất kỳ cụm từ hoặc mô hình diễn đạt phổ biến nào trùng nhau.

Quan điểm của mình: nên học cách tư duy và phương pháp của Skill gốc, sau đó thiết kế Skill mới có quy tắc thực thi phù hợp với workflow của bạn. Không nên copy nguyên văn nhiều Skill rồi ghép lại, vì chúng có thể có mục tiêu, cách hỏi và điều kiện hoàn thành khác nhau.

Tại sao kg lấy ng văn
Thực ra, mình không có lý do đủ mạnh để không lấy nguyên văn các Skill gốc trong trường hợp này. Mình đã tùy biến quá sớm.

Sau khi kiểm tra lại GitHub, mình cho rằng phương pháp tốt hơn cho dự án của bạn là:

Upstream-first, Customization-second
Tức là giữ nguyên những gì tác giả đã xây dựng và kiểm nghiệm, chỉ bổ sung lớp điều phối để phù hợp với Antigravity.

1. Có thể sử dụng nguyên văn không?
Có. Hai nguồn chúng ta đang xét có giấy phép cho phép tái sử dụng:

Repository

License

Hướng xử lý

Anthropic Knowledge Work Plugins

Apache 2.0

Giữ nguyên Skill, giữ thông tin license

ferminrp Agent Skills

MIT

Giữ nguyên Skill, giữ copyright và license

GitHub
+1
Không cần viết lại chỉ vì muốn sử dụng trên Antigravity. Tuy nhiên phải kiểm tra tương thích môi trường và các tài nguyên phụ trợ.

1. Mình muốn thay đổi cách xây dựng The Seed
Thay vì viết lại ba Skill như bản v1.0, nên chia thành hai lớp:

LAYER 1 — UPSTREAM
Original Skills

Giữ nguyên SKILL.md, references, templates và scripts của tác giả.

Không tự tiện sửa nội dung.

LAYER 2 — CUSTOM
The Seed Orchestration

Chỉ chứa những thứ dự án cần thêm:

Quy trình ba tab.

Prompt khởi chạy từng tab.

Human Approval Gates.

Quy tắc bàn giao artifact.

Quy tắc dừng và không tự động chuyển bước.

1. Cấu trúc mới mình đề xuất
.agents/
└── skills/
│
├── product-brainstorming/
│ └── [ORIGINAL — ANTHROPIC]
│
├── product-shaping/
│ ├── SKILL.md
│ ├── references/
│ └── assets/
│ [ORIGINAL — FERMINRP]
│
└── seed-independent-review/
└── SKILL.md
[CUSTOM — BASED ON ANTHROPIC
CODE REVIEW PRINCIPLES]

product/
└── seed/
├── SEED_WORKFLOW.md
├── DECISION_LOG.md
└── artifacts/

prompts/
├── TAB_01_EXPLORE.md
├── TAB_02_INVESTIGATE.md
└── TAB_03_REVIEW.md

UPSTREAMS.md
Lưu ý: product-shaping cần lấy cả thư mục vì Skill gốc tham chiếu prototype-guide.md và shaping-doc-template.md, không chỉ riêng SKILL.md.

GitHub

1. Nguyên tắc từ nay khi tìm Skill GitHub
Mình đề xuất áp dụng quy tắc sau cho toàn bộ dự án, không riêng The Seed:

Không viết lại khi Skill gốc đã giải quyết đúng vấn đề.

Ưu tiên cài nguyên bản và giữ provenance.

Không thay đổi upstream chỉ để đổi tên hoặc đổi phong cách diễn đạt.

Tạo wrapper Skill riêng để điều phối.

Chỉ fork và sửa Skill gốc khi có xung đột thực tế, thiếu chức năng hoặc không tương thích.

Nếu sửa, phải ghi rõ thay đổi so với upstream.

Giữ license, copyright và attribution tương ứng.

Kết luận: Mình muốn sửa định hướng của bộ v1.0: thay vì tạo ba Skill tự viết rồi tham khảo GitHub, hãy lấy Skill chất lượng từ GitHub làm lõi, còn The Seed chỉ đóng vai trò điều phối và kiểm soát.

Đây là cách vừa tận dụng được chất lượng của cộng đồng, vừa tránh tự phát minh lại những thứ người khác đã làm tốt.

</long_text_quote>bạn xem thêm đây là đoạn chat lúc phát triển repo

---

### 🤖 WorkBuddy AI

Đoạn chat này giải thích vì sao repo có `UPSTREAMS.md` — và nó cũng nêu vài repo tôi chưa kiểm tra. Kiểm tra thật trước đã:

---

### 🤖 WorkBuddy AI

Kiểm tra xong. Có **một phát hiện chặn** và **một repo tốt hơn hẳn** những gì đoạn chat đề xuất.

---

### 🤖 WorkBuddy AI

Đã kiểm tra từng repo trong đoạn chat đó bằng GitHub API, không dựa vào mô tả. Ba kết quả, một trong số đó chặn hẳn:

| Repo | Thực tế | Kết luận |
| --- | --- | --- |
| pbakaus/impeccable | Apache-2.0 · 108.590★ · push cùng ngày 12/11 · 41 playbook | Dùng được, nhưng reference-only |
| Conradgui/zero-to-one-product-discovery | "license": null · 6★ · push 08/06 | Từ chối — không có license |
| elcodabra/validate-idea-skills | MIT · 2★ · 71KB | Dùng được, nhưng mỏng |

**Vấn đề license.** Repo `zero-to-one` không khai báo license nào. Trên GitHub, không có license nghĩa là *bảo lưu toàn bộ quyền*, không phải public domain. Đoạn chat đề xuất nó làm nguồn chính cho Seed — nhưng copy vào repo là vi phạm, kể cả một đoạn nhỏ. Tôi đã ghi vào `UPSTREAMS.md` mục 5 để sau này không ai đề xuất lại.

**Impeccable tốt hơn hẳn những gì đoạn chat mô tả** — và cũng chính vì thế mà không dùng trực tiếp được. Nó có `shape.md` (lập UX trước khi viết code), `critique.md` (review UX có chấm điểm heuristic), `audit.md` + `audit.native.md` (a11y, perf, responsive), `extract.md` (token), `craft-floor.md` (danh sách lệnh cấm), và **android.md**. Đúng những thứ P5-P8 cần.

Nhưng để nguyên bản làm active skill thì hỏng, vì hai lý do độc lập:

1. **Nó là design agent, không phải design method.** Lệnh `new-work` thiết kế *và viết code production* trong một lượt. Gắn nó vào P5 là P5→P7 gộp làm một, Gate 1 và Gate 2 thành đồ trang trí. Đây đúng cái lỗi đã ghi với Product Shaping: skill chạy nhiều phase một lúc thì không ngồi được trong mô hình 3 tab.
2. **Nó mang runtime.** Skill gọi `impeccable context` , hook detector, và một binary Rust. Repo này cố ý thuần markdown, không phụ thuộc thực thi.

Nên tôi đưa nó vào diện **reference-only**, và nối từng playbook vào bảng upstream của P5-P8. Có một chỗ tôi cố ý **không** nối: `colorize` và `animate` vào P7 — màu đã freeze ở P6, nên một playbook cho phép P7 mở lại quyết định của P6 là rò rỉ boundary, không phải nguồn.

Điều đáng chú ý: đoạn chat kết luận "upstream-first, copy nguyên văn". Kết luận đó đúng về license, nhưng **chưa đủ**. Với impeccable, rào cản không phải bản quyền mà là kiến trúc — copy được mà dùng thì hỏng. Đây là loại phân biệt chỉ hiện ra khi đọc skill thật.

---

Còn một lỗ hổng không ai trong đoạn chat nhắc: **repo chưa từng ghi target platform ở đâu cả.** Tên repo là `app-adr-ui`, cả đoạn chat nói về Android, impeccable có `android.md` — nhưng trong repo không có một dòng nào xác nhận. P6 charter đang để nó là câu hỏi mở số 2, và nó ảnh hưởng trực tiếp: minimum target size, type scale, elevation, Material 3, window insets, system Back, adaptive layout. Đây là loại quyết định mà repo này không cho phép suy ra từ tên thư mục.

❓ **Q11** - **Platform chốt là gì?**: (a) Android native (Jetpack Compose / Material 3) — khớp tên repo và toàn bộ thảo luận trước; (b) Android + web; (c) chỉ web, "adr" không phải Android.

➡️ **(a) Android native.** Nếu đúng, tôi thêm một mục `platform` vào Control template P6 (và P7) như một *recorded decision* bắt buộc, để không ai phải đoán lại — và nó biến `android.md` từ "nguồn tham khảo" thành ràng buộc có thể kiểm tra ở Gate.

---

Một mặc định tôi giữ, nếu bạn không phản đối: **chưa vendor skill nào vào .agents/skills/.** Đoạn chat của bạn kết thúc đúng bằng câu này — *"hãy thử bộ v1 với một ý tưởng thực tế... sau đó mới chỉnh v2 dựa trên lỗi thực tế, thay vì tiếp tục tăng độ phức tạp trước khi chạy thử"*. P5 hiện có 53 kịch bản chưa chạy; thêm 600 dòng upstream Apache-2.0 vào lúc này là tăng bề mặt trước khi có evidence.

---

### 👤 User

@long-text:"PROCESS 04..." <long_text_quote>PROCESS 04 — REMEDIATION PLAN v0.3.1
Cross-Process Change Management Contract
Field Value
Document ID P04-REMEDIATION-PLAN
Version 0.3.1
Status DRAFT_FOR_OWNER_DECISION — HOLD
Applies to Process 04 — App Flow
Repository reference kimducanh27-cpu/app-adr-ui
Baseline cited by Round 2 reviewer main @ 99ac2c629a5e3ecc53e45f2b923163b0593d5b6a
Approval authority Repository Owner
Implementation authority Not granted by this document
Change mode Specification only; no repository changes made
Corrects Process 04 Remediation Plan v0.3, limited to D3-01 (abort-pair/hash-chain semantics) and D3-02 (Phase 0 clarification count)

Current decision: HOLD. This document is a narrowly scoped micro-diff correction to v0.3 for D3-01 and D3-02. It does not authorize implementation, migration, branch creation, commits, pull requests, or changes to main. All ADR and CL owner decisions remain PENDING until explicitly approved by the repository owner.

1. Document purpose and decision rules
0.0.1 v0.3.1 micro-diff boundary
This revision changes only the following v0.3 locations: document version metadata; Sections 4.1, 4.4, 5.2, 5.4, 5.5, 5.6, and 5.7; the abort-pair test expectation in Section 15; the Phase 0 clarification count in Section 16; the CL-01 wording in Section 17.1; and the change log/provenance/review notes. These edits address D3-01 and D3-02 from the v0.3 diff review. All other v0.3 policy content is carried forward unchanged.

This version is a narrowly scoped correction to v0.3. It resolves only D3-01 (the abort-pair receipt/hash-chain boundary) and D3-02 (the Phase 0 clarification count). It does not reopen the full P04 architecture review, change the NF-01…NF-12 dispositions, or grant implementation authority.
0.1 Normative language

- MUST / MUST NOT: mandatory requirement for an implementation to pass review.
- SHOULD / SHOULD NOT: recommended unless the Owner records an explicit rationale for deviation.
- MAY: optional behavior.
- HOLD: implementation is prohibited until all release criteria are met.
- NOT_VERIFIED: integrity cannot be established; fail closed.
- NOT RUN: a runtime test has not actually been executed and evidenced.
0.2 Source-of-truth hierarchy

1. The approved version of .agents/skills/app-flow/SKILL.md is the canonical P04 process contract.
2. Templates define the serialized shape of P04 artifacts and MUST agree with the Skill.
3. Prompts define tab-specific execution instructions and MUST reference the Skill rather than independently redefining business rules.
4. README and checklist files are operator-facing indexes and MUST describe the same paths, versions, ownership, and gates; they MUST NOT create a competing policy.
5. The P04 Change Request Register is the sole source of truth for CR business state.
6. The P04 Control File is the source of committed sequence, receipts, integrity checkpoints, Gate state, and frozen-output binding. It MUST NOT duplicate a per-CR business-status table.
7. The Decision Log remains append-only. The Control File's DECISION_LOG_UPDATED event is the commit receipt and sequence anchor; the Decision Log body MUST NOT contain a predicted or committed Control File sequence.
8. P03 remains an external upstream source. P04 reads and verifies the actual P03 v2 fields; P04 MUST NOT rewrite or upgrade P03 as part of this remediation.
If two artifacts disagree, the canonical contract wins for interpretation, but the workspace is NOT_VERIFIED until the inconsistent artifact is corrected through an approved change. Readers MUST NOT silently choose one copy and continue.
9. Executive disposition
1.1 Round 2 verdict
HOLD — v0.2 is not implementation-ready. Round 2 identified five P0 findings and seven P1/P2 findings:
Finding Severity Required disposition in v0.3
NF-01 P0 Remove predicted Control sequence from Register events; define deterministic recovery and abort handling for a staged tail.
NF-02 P0 Define canonical bytes and complete prefix-chain verification from the initialization anchor through the last committed event.
NF-03 P0 Remove control_state_seq from Decision Log event bodies; retain Control File receipt as the sole committed sequence anchor.
NF-04 P0 Make all legal CR transitions explicit, including reopen and reversion paths, exact commands, evidence, permissions, receipt, Gate effect, and recovery.
NF-05 P0 Close the Freeze-to-CR-closure publication gap; downstream remains blocked until every CR for the freeze batch is closed and verified.
NF-06 P1 Initialize the Register at workspace creation and migration, including a non-null hash anchor when there are zero CRs.
NF-07 P1 Make on-disk Gate approval events the only cross-tab handoff evidence.
NF-08 P1 Add a no-upstream-change resolution for P03 returns and bind every return to its own P03 hash snapshot.
NF-09 P1 Define safe v3→v4 migration, explicit attestation about unrecorded CRs, backup manifest, and inherited-freeze behavior.
NF-10 P1 Validate duplicate/supersession/dependency graph targets and reject cycles before append.
NF-11 P2 Define deterministic frozen_version increment and prohibit no-op re-freeze.
NF-12 P2 Upgrade product/app-flow/README.md from SHOULD CHANGE to MUST CHANGE.

1.2 Round 1 closure status retained
The following Round 1 topics remain resolved or partially resolved as reported by the reviewer. They MUST be rechecked against the implementation diff during Phase 6; this document does not convert a prior paper assessment into a runtime pass.
Round 1 topic Round 2 status v0.3 treatment
Decision Log enum mismatch Partially resolved; NF-03 regression Fix the token mismatch; do not embed Control sequence in the Decision Log.
Dual CR state source Resolved Register owns CR state; Control File keeps pointers and receipts only.
Register/Control consistency Partially resolved Replace v0.2 transaction design with Section 5.
Submission boundary Resolved P03 and downstream submit immutable payloads; they do not write P04 files.
CR-ID ownership Resolved Tab 01 alone assigns CR-ID after intake validation.
Incomplete state machine Not resolved Use Section 7 and transition contract T01–T18.
REFROZEN ambiguity Resolved No CR state named REFROZEN; use CLOSED_IMPLEMENTED and explicit freeze binding.
Rejection semantics Resolved Rejection only removes its own blocking obligation, after proof of no byte change.
Gate/downstream mixing Resolved Gate validity and downstream eligibility are separate calculations.
P03 re-entry Partially resolved Use T08/T09 and per-CR return snapshots.
SHA-256 semantic confusion Resolved Hash proves byte identity only, not semantic equivalence.
v3 compatibility Partially resolved Use Section 10 migration rules.
Tab write contention Partially resolved Enforce one logical writer and disk-based handoff; no claim of OS-level lock/CAS.
Template/active path mapping Resolved Preserve the exact path mapping in Section 3.
Documentation duplication Partially resolved Canonical rules live in Skill; all README files are mandatory synchronized indexes.
P03 schema compatibility Resolved P03 stays schema v2; read only fields that actually exist.
Post-freeze CR closure Not resolved Close through the publication contract in Section 9.

1. Scope, ownership, and exclusions
2.1 P04 owns
Process 04 owns functional task/flow architecture, navigation, functional SCREEN-ID inventory, transitions, functional states, exceptions, recovery, and the frozen App Flow contract. The P04 CR mechanism governs requests that seek to change those P04-owned artifacts.
2.2 P04 does not own
P04 MUST NOT define or modify visual design decisions, wireframes, typography, color systems, API architecture, database architecture, implementation code, or the internal policies of downstream processes unless the Owner explicitly expands P04 scope.

P04 MUST NOT modify:

- templates/03-PRODUCT-DEFINITION/*
- prompts/03-PRODUCT-DEFINITION/*
- .agents/skills/product-definition/SKILL.md
- product-definition-kit/*
P03 remains schema_version: 2. P04 must not invent a P03 field named gate_3.approved_state_seq; the Round 2 baseline states that this field does not exist in P03 v2.

P05 and Processes 01, 02, 06, and 07 are outside this remediation scope. P04 may publish evidence for downstream consumption but MUST NOT prescribe unapproved downstream design policy.
2.3 Submission boundary
P03 or a downstream process may prepare and submit an immutable change-request payload. It MUST NOT write directly to P04's Control File, Register, Decision Log, review history, or functional artifacts. The user carries the payload to Tab 01. Tab 01 verifies source identity, source hashes, initiative binding, duplicate fingerprint, and then assigns the P04 CR-ID.
3. Repository baseline and canonical paths
3.1 Baseline facts from the Round 2 packet
The uploaded Round 2 review reports that the repository snapshot app-adr-ui-main6.zip matched:

- Repository: kimducanh27-cpu/app-adr-ui
- Branch: main
- HEAD: 99ac2c629a5e3ecc53e45f2b923163b0593d5b6a
- P03 Control Template: schema_version: 2
- P04 Control Template: schema_version: 3
These are packet-reported baseline facts, not a fresh verification of the current remote repository in this task. Before implementation, the implementer MUST fetch and verify the actual target branch HEAD and all affected paths again.
3.2 Template-to-working-file mapping
Template numbering is local to templates/04-APP-FLOW/; it is not the working-artifact number. Preserve these exact mappings:
Template Working artifact / purpose
templates/04-APP-FLOW/10-DECISION-LOG.md product/app-flow/09_DECISION_LOG.md
templates/04-APP-FLOW/11-CHANGE-REQUEST-REGISTER.md product/app-flow/10_CHANGE_REQUEST_REGISTER.md
templates/04-APP-FLOW/08-APP-FLOW-DRAFT.md product/app-flow/08_APP_FLOW_DRAFT.md
templates/04-APP-FLOW/09-APP-FLOW.md Frozen-output schema for product/app-flow/APP_FLOW.md

The mapping 11-CHANGE-REQUEST-REGISTER.md → 10_CHANGE_REQUEST_REGISTER.md is intentional and MUST NOT be renumbered to match template numbering.
3.3 Canonical P04 files
Path Role Owner
.agents/skills/app-flow/SKILL.md Canonical P04 process contract Process 04
templates/04-APP-FLOW/00-APP-FLOW-CONTROL.md Control File schema v4 Tab 01/02/03 by event ownership
templates/04-APP-FLOW/10-DECISION-LOG.md Decision Log template Tab 01/02 by Gate ownership
templates/04-APP-FLOW/11-CHANGE-REQUEST-REGISTER.md CR Register schema Tab 01 only writer
templates/04-APP-FLOW/07-FLOW-REVIEW.md Review rounds and CR snapshot Tab 03
prompts/04-APP-FLOW/01-TASK-MODEL.md Tab 01 prompt Tab 01
prompts/04-APP-FLOW/02-NAVIGATION-FLOW.md Tab 02 prompt Tab 02
prompts/04-APP-FLOW/03-INDEPENDENT-REVIEW.md Tab 03 prompt Tab 03
app-flow-kit/README.md Kit guide Documentation
app-flow-kit/VERIFICATION-CHECKLIST.md Static and scenario checklist Verification
product/app-flow/README.md Active workspace guide Documentation
README.md Repository-level process index Documentation
product/app-flow/00_APP_FLOW_CONTROL.md Active Control File Tab 01/02/03 by event ownership
product/app-flow/09_DECISION_LOG.md Active Decision Log Tab 01/02 by Gate ownership
product/app-flow/10_CHANGE_REQUEST_REGISTER.md Active CR Register Tab 01 only writer
product/app-flow/APP_FLOW.md Frozen App Flow output Tab 03 freeze executor

1. Canonical state and data model
4.1 Separation of business state and commit evidence
The following concepts MUST remain distinct:
2. Register event exists: a ### CRE- block is present in the Register. Existence alone does not make it effective.
3. Register event is structurally valid: required fields, initiative binding, event identity, register_seq, transition legality, and prefix hash are valid.
4. Register record is accounted by a matching receipt: a normal event is accounted by exactly one CHANGE_REQUEST_REGISTER_UPDATED receipt; the two events in an abort unit are accounted together by exactly one CHANGE_REQUEST_EVENT_ABORTED receipt.
5. Register receipt unit is committed: structural validity, the permitted receipt shape, and complete chain verification from initialization through the current checkpoint all pass. For a normal unit, its business event is effective. For an abort unit, the staged business event is accounted in the immutable history but classified ABORTED_NOT_EFFECTIVE; the abort marker is audit-only.
6. Current CR business state: reconstructed only from the latest effective, committed state-changing normal event for that CR-ID. Neither member of an abort unit changes CR business state. Current CR business state exists only in the Register.
7. P04 workspace integrity: all relevant files, sequences, event receipts, and hashes verify. Otherwise NOT_VERIFIED.
8. Downstream eligibility: a separate predicate over workspace integrity, all three Gates, lifecycle, frozen artifact, Register chain, and an empty reconstructed blocking-CR set.
The Control File MUST NOT store a second per-CR status table or authoritative copy of active_blocking_cr_count / blocking_cr_ids. Any such count/list is a derived view and MUST be recomputed from the Register and receipts by every reader.
4.2 P04 Control File v4 — required structural changes
The P04 Control File template MUST:

- set schema_version: 4;
- remove change_requests: [];
- add a change_request_register checkpoint containing at minimum:

 - path: product/app-flow/10_CHANGE_REQUEST_REGISTER.md
 - schema_version: 1
 - last_verified_sha256
 - last_register_seq
 - last_event_id;

- add Control event kinds CHANGE_REQUEST_REGISTER_INITIALIZED, CHANGE_REQUEST_REGISTER_UPDATED, and CHANGE_REQUEST_EVENT_ABORTED;
- support SCHEMA_MIGRATED from v3 to v4;
- preserve existing P04 Gate approval fields and state_seq semantics, while ensuring all new receipts have strictly increasing unique state_seq values;
- define Gate validity independently from downstream eligibility.
state_seq is a monotonic stale-read detector and committed event sequence. It is not an atomic lock, compare-and-swap operation, filesystem mutex, or distributed lock.
4.3 Register v1 — required header and event shape
10_CHANGE_REQUEST_REGISTER.md MUST begin with immutable identity fields:
- Process: 04
- Initiative ID: <verified_initiative_id>
- Register Schema Version: 1
- a stable schema/header declaration and serialization rule.
Each appended event MUST contain, as applicable:
- change_request_event_id: CRE-
- change_request_id: CR-
- register_seq: <1..N>
- event_type
- from_status and to_status for status transitions
- exact_user_command
- recorded_by_tab: TAB_01
- timestamp_local
- submission_id and submission_payload_sha256 when applicable
- source_process, source_initiative_id, source_artifact_path, source_artifact_sha256 when applicable
- affected_gate and affected_artifact_paths
- control_state_seq_before_append
- control_file_sha256_before_append
- previous_register_sha256
- transition-specific evidence fields
- event_end_marker: END_CRE.
The Register event MUST NOT contain planned_control_state_seq, a predicted committed control_state_seq, or resulting_register_sha256. The Control File receipt assigns the committed state_seq and records the resulting whole-file hash.
4.4 Register serialization and hash rules (NF-02)
To remove Windows/Linux line-ending and delimiter ambiguity, the canonical file encoding is:
- UTF-8 without BOM;
- LF (\n) line endings only;
- no CR (\r) bytes;
- no trailing spaces or tabs on any line;
- exact field names and field order as defined by the approved schema;
- every event ends with event_end_marker: END_CRE followed by LF, and event blocks are separated by exactly one blank line;
- the file ends with the canonical line terminator defined by the template.
Readers MUST reject noncanonical serialization instead of silently normalizing the file and accepting a hash that does not match the bytes on disk.

Hash definitions:

- previous_register_sha256: SHA-256 of the exact entire Register byte sequence on disk immediately before appending that event.
- event_block_sha256: SHA-256 of the exact UTF-8/LF bytes from the first byte of ### CRE- through the LF after event_end_marker: END_CRE (excluding the following blank separator line).
- resulting_register_sha256: SHA-256 of the exact entire Register byte sequence after the append, including the canonical separator.
- hashes are lowercase hexadecimal.
Receipt units and the abort-pair exception:

1. A normal commit unit contains exactly one business Register event at sequence k and exactly one CHANGE_REQUEST_REGISTER_UPDATED receipt. Its previous_register_sha256 must equal the last trusted committed Register hash before sequence k.
2. An abort commit unit contains exactly two consecutive Register events, at sequences k and k+1: (a) the complete but uncommitted staged business event and (b) its immediately following CHANGE_REQUEST_EVENT_ABORTED audit marker. Exactly one CHANGE_REQUEST_EVENT_ABORTED Control receipt accounts for this pair. There MUST NOT be a normal CHANGE_REQUEST_REGISTER_UPDATED receipt for either member.
3. In an abort unit, the staged event's previous_register_sha256 equals the trusted committed hash H(k-1). After appending that event and its canonical separator, the reader computes the intermediate hash H(k). The abort marker's previous_register_sha256 MUST equal this intermediate hash H(k). H(k) is an internal hash-chain link only; it is not a committed checkpoint and MUST NOT be published as last_verified_sha256.
4. After appending the abort marker and its canonical separator, the reader computes final hash H(k+1). The single abort receipt MUST bind the trusted prior hash H(k-1), staged event ID/sequence/block hash, intermediate hash H(k), abort marker ID/sequence/block hash, final hash H(k+1), and the receipt's Control state_seq. The Control Register pointer advances directly from H(k-1) to H(k+1) and last_register_seq advances from k-1 to k+1; there is no committed checkpoint at k.
5. The next normal Register event, if any, MUST use register_seq: k+2 and previous_register_sha256: H(k+1). No reader may treat the staged business event at k as an independently committed event.
For every Register sequence covered by the committed history, the reader MUST verify:
6. register_seq values are contiguous and each receipt unit has the permitted shape: one event for a normal unit or exactly two events for an abort unit.
7. The first event of each receipt unit links to the previous committed checkpoint (or the initialization hash for the first unit). Within an abort unit only, the second event links to the intermediate hash produced after the first event; that intermediate hash is not a commit checkpoint.
8. Every event-block hash matches the exact event bytes.
9. A normal receipt's resulting_register_sha256 equals the exact full-file hash after its one event. An abort receipt's resulting_register_sha256 equals the exact full-file hash after both events.
10. Every normal commit unit has exactly one CHANGE_REQUEST_REGISTER_UPDATED receipt; every abort commit unit has exactly one CHANGE_REQUEST_EVENT_ABORTED receipt covering both events; no event is double-accounted or left unaccounted.
11. The last receipt agrees with change_request_register.last_verified_sha256, last_register_seq, and last_event_id. For an abort unit, last_event_id is the abort marker's CRE-ID.
A reader MUST verify the complete history from the initialization anchor to last_register_seq; checking only the final whole-file hash is insufficient. An abort unit commits the audit disposition and bytes of the pair, not the business effect of the original staged transition.
4.5 Register initialization (NF-06)
Register initialization is mandatory at Tab 01 workspace initialization, even when there are zero CRs.

Procedure:

1. Verify P03 identity and frozen source using the actual P03 v2 fields.
2. Confirm no existing Register conflicts with the Control File checkpoint.
3. Create product/app-flow/10_CHANGE_REQUEST_REGISTER.md from templates/04-APP-FLOW/11-CHANGE-REQUEST-REGISTER.md.
4. Set immutable identity header; no CR event blocks are added.
5. Read the file back and compute H_init over its exact bytes.
6. Append CHANGE_REQUEST_REGISTER_INITIALIZED to the P04 Control File, anchoring register_seq: 0, last_event_id: INITIALIZATION, last_verified_sha256: H_init, path, schema version, initiative ID, and actual Control state_seq.
7. Read both files again and verify the initialization receipt and exact hash before proceeding.
A v4 workspace with zero CRs still MUST have non-null last_verified_sha256 and last_register_seq: 0.

Abnormal cases:

- Register missing and checkpoint null: initialize only at a clean new-workspace boundary, or inside the approved v3→v4 migration transaction.
- Empty 0-byte file: NOT_VERIFIED; do not auto-overwrite.
- Header-only file with null checkpoint: may be initialized only if its bytes exactly match the approved template serialization and Initiative ID matches.
- Register contains CRE events but Control checkpoint is null: NOT_VERIFIED.
- Initiative ID mismatch: NOT_VERIFIED; never rebind or edit the header to make it match.
- Register schema mismatch: stop and require a separately approved migration.
- Checkpoint exists but Register is missing: NOT_VERIFIED; preserve evidence, invalidate P04 conservatively, and restore only from a trusted backup.

1. Paired append-and-receipt transaction protocol
5.1 Core rule
The Register stores CR business events. The Control File stores the commit receipt and current verified checkpoint. A CR state transition becomes effective only after the Register event and its matching Control File receipt have both been read back and verified.
5.2 Normal commit protocol
This protocol applies to a normal business-state Register event. The two-event abort unit is governed exclusively by Section 5.6. Before any normal write, Tab 01 MUST:
2. Read the current Control File, Register, and relevant artifacts from disk; never use conversation memory as a source of current sequence or hash.
3. Verify the complete Register receipt/hash chain and Control File event sequence.
4. Verify there is no unresolved staged tail or competing writer operation.
5. Reconstruct the CR's current status and validate the requested transition.
6. Recompute all preconditions, source hashes, affected-file hashes, graph constraints, and Gate evidence.
7. Capture control_state_seq_before_append and control_file_sha256_before_append.
8. Append exactly one canonical Register event with register_seq = previous + 1, and without a predicted Control sequence.
9. Read the Register back; verify exact event bytes, previous hash, event hash, resulting full-file hash, sequence continuity, and event schema.
10. Append one CHANGE_REQUEST_REGISTER_UPDATED receipt to the Control File using the next currently available Control state_seq. The receipt MUST bind: initiative ID, CR-ID, CRE-ID, register sequence, previous Register hash, event-block hash, resulting Register hash, and receipt state sequence.
11. Read both files back; verify the normal event-to-receipt one-to-one match, pointer update, full chain, and final hashes. Abort-pair verification MUST use the distinct two-event/one-receipt rule in Sections 4.4 and 5.6.
12. Report success only after read-back verification passes.
There MUST be one logical writer for a transaction. Tab 01 is the sole Register writer. Tab 02 and Tab 03 MUST NOT write Register receipts. This is a workflow ownership rule, not an OS-level lock guarantee.
5.3 Recovery when Control state_seq has advanced (NF-01)
A staged Register event MUST NOT reserve or hard-code a future Control state_seq. The receipt uses the next available sequence at recovery time.

When one complete staged tail exists but its Control receipt is missing:

1. Stop every other write operation.
2. Verify that the trusted Register prefix hash equals the last committed Control checkpoint.
3. Verify there is exactly one staged event, structurally complete, with a valid event hash and correct next register_seq.
4. Re-read the current Control File and confirm the Register pointer still references the same trusted prefix.
5. Re-evaluate all current business preconditions against disk. Do not assume the original transition is still valid merely because the staged bytes are valid.
6. If the transition is still valid, use RECOVER CHANGE REQUEST EVENT [CRE-ID] to write the missing receipt at the next available Control sequence. A prior unrelated Control event may consume the previously observed sequence; this does not itself prevent recovery.
7. Read back and verify both files before resuming operations.
This removes the deadlock caused by a planned_control_state_seq embedded in the Register. If current business preconditions no longer allow the staged transition, use the abort path in Section 5.6 instead of committing it.
5.4 Ambiguous Control File write
If the writer cannot tell whether the Control File receipt was persisted:

- do not append again immediately;
- reopen and read both files;
- if exactly one matching normal receipt exists and every hash/checkpoint matches, treat the normal transaction as committed and do not repeat it;
- if exactly one matching CHANGE_REQUEST_EVENT_ABORTED receipt exists and it binds the exact two-event abort unit as specified in Sections 4.4 and 5.6, treat the abort unit as accounted and do not repeat it;
- if no receipt exists and exactly one valid staged business event exists, follow Section 5.3 or begin Section 5.6 after re-evaluating its business precondition;
- if no receipt exists and exactly one complete staged business event plus its immediately following complete abort marker exist, use RECOVER CHANGE REQUEST ABORT [STAGED-CRE-ID] under Section 5.5; do not append a second abort marker;
- if a duplicate receipt, orphan receipt, malformed Control File, sequence gap, partial event, unexpected tail length, or hash mismatch exists, stop at NOT_VERIFIED and restore/forensically reconcile from a trusted backup.
5.5 Bounded recovery limits
RECOVER CHANGE REQUEST EVENT [CRE-ID] is permitted only for exactly one complete staged business event whose preceding prefix equals the last trusted Register hash, whose next register_seq is correct, and whose current business preconditions still pass. It MUST NOT commit an event whose preconditions have become invalid.

RECOVER CHANGE REQUEST ABORT [STAGED-CRE-ID] is a separate, narrowly bounded recovery command. It is permitted only when all of the following are true:

1. exactly two complete, consecutive, unreceipted Register events exist after the trusted checkpoint;
2. the first is the staged business event identified by [STAGED-CRE-ID];
3. the second is its immediately following CHANGE_REQUEST_EVENT_ABORTED marker and references the first event exactly;
4. the first event links to the last trusted checkpoint, the second links to the computed intermediate hash after the first event, and both event-block hashes and the final Register hash verify;
5. no later Register event exists and no matching abort receipt exists;
6. the current Control File remains structurally valid and its Register pointer still equals the trusted pre-pair checkpoint.
When these preconditions pass, Tab 01 MUST append only the missing CHANGE_REQUEST_EVENT_ABORTED receipt at the next currently available Control state_seq; it MUST NOT append either Register event again. The receipt MUST bind the complete abort pair as specified in Section 5.6, followed by a full read-back.

Any partial event, malformed abort marker, more than two unreceipted events, missing historical event, invalid sequence gap, changed trusted prefix, malformed Control File, or unrecognized receipt shape MUST be refused. Restore the Register and Control File to the last mutually verified backup; do not truncate or rewrite historical append-only events in place. The sole two-event exception is the exact abort pair defined above.
5.6 Abort of a staged event whose business precondition is no longer valid
The abort path MUST preserve the append-only Register and account for the staged bytes without committing the staged business transition. It is a two-event, one-receipt abort commit unit, not two independent Register commits.

Preconditions:

- exactly one structurally complete staged business event exists at the next register_seq: k after the last trusted committed checkpoint;
- no later Register event exists and the staged event has no normal CHANGE_REQUEST_REGISTER_UPDATED receipt;
- the staged event's previous_register_sha256 equals the trusted checkpoint hash H(k-1);
- the current Control File pointer still identifies that same trusted checkpoint;
- re-evaluation against current on-disk state proves that the staged business precondition is no longer valid;
- the event is not itself an earlier committed event and is eligible for this bounded abort protocol.
Append and receipt procedure:

1. Tab 01 preserves the staged event at sequence k exactly as written. It MUST NOT edit, remove, renumber, or rewrite it.
2. Compute the intermediate hash H(k) over the exact Register bytes after the staged event and its canonical separator. This intermediate hash MUST be retained as evidence for the abort marker and receipt but MUST NOT be written as a Control checkpoint or treated as a committed Register state.
3. Append one new audit event at register_seq: k+1, with a new CRE-ID, event_type: CHANGE_REQUEST_EVENT_ABORTED, and previous_register_sha256: H(k). The marker MUST identify the staged CRE-ID, staged CR-ID, staged event_block_sha256, H(k-1), H(k), and an explicit abort rationale. It MUST NOT describe a CR business-state transition. Its own event block ends with the canonical event_end_marker: END_CRE.
4. Compute final hash H(k+1) over the entire Register after the abort marker and its canonical separator.
5. Append exactly one CHANGE_REQUEST_EVENT_ABORTED receipt to the Control File at the next currently available Control state_seq. The receipt MUST bind at least: initiative_id; receipt_type; first_register_seq: k; last_register_seq: k+1; staged CRE-ID and CR-ID; abort-marker CRE-ID; trusted prior hash H(k-1); staged event-block hash; intermediate Register hash H(k); abort-marker event-block hash; final Register hash H(k+1); status_effect: NONE; and the committed Control state_seq.
6. The Control File Register checkpoint advances directly from (k-1, H(k-1)) to (k+1, H(k+1)). It MUST set last_register_seq: k+1, last_event_id to the abort-marker CRE-ID, and last_verified_sha256: H(k+1). There is no independently committed checkpoint for sequence k.
7. Read both files back. Verify the exact staged event bytes, the internal hash edge H(k-1) → H(k) → H(k+1), both event-block hashes, the single abort receipt, the final Register pointer, and all earlier receipt units. Only after all checks pass may the workspace return to VERIFIED.
Deterministic reconstruction:

- The original staged business event at sequence k is retained in history and classified ABORTED_NOT_EFFECTIVE. It MUST NOT change the CR's business state.
- The abort marker at sequence k+1 is an audit event only and MUST NOT change the CR's business state.
- The prior committed CR state remains authoritative.
- The pair is accounted for by one abort receipt; no normal CHANGE_REQUEST_REGISTER_UPDATED receipt may exist for either member.
- The next event, if any, starts at sequence k+2 and links from H(k+1).
Interrupted abort handling:
- If interruption occurs before the abort-marker append has begun, the Register still contains only the one complete staged business event. Re-open the files and restart this Section 5.6 only after rechecking all preconditions.
- If interruption occurs during the abort-marker append and leaves partial/malformed bytes, the Register is NOT_VERIFIED; preserve evidence and restore from the last mutually verified backup. Do not append a second marker after a partial marker.
- If the abort marker is complete but the Control receipt is absent, do not append another marker. Run RECOVER CHANGE REQUEST ABORT [STAGED-CRE-ID] under Section 5.5; it validates the exact pair and writes only the missing receipt.
- If the Control receipt may have been written but acknowledgement was lost, re-read both files. If the exact abort receipt and all bindings verify, treat the abort unit as complete and do not duplicate it.
If the staged tail cannot be proven to descend from the trusted prefix, is more than one event long before the abort marker is added, or fails any pair validation, this abort protocol is not permitted. Owner approval is required for this explicit exception to the ordinary one-event/one- `CHANGE_REQUEST_REGISTER_UPDATED` receipt rule.
5.7 Integrity failure policy
Any of the following means NOT_VERIFIED and fail closed: missing/duplicate receipt outside the bounded recovery cases in Sections 5.4–5.5, wrong initiative, wrong CR-ID, incorrect event-block hash, incorrect resulting hash, sequence gap, stale rollback, modified historical event, noncanonical serialization, broken prefix chain, more than two unreceipted tail events, an unrecognized two-event tail, or an untrusted Control File. An exact two-event abort pair with its receipt missing is NOT_VERIFIED / ABORT_RECEIPT_PENDING and may proceed only through RECOVER CHANGE REQUEST ABORT [STAGED-CRE-ID]; it is not eligible for ordinary writes.

When the Register is not verified, all ordinary P04 writes, Gate approvals, Freeze, and downstream consumption are prohibited. Only the narrowly bounded recovery command expressly allowed by Sections 5.3 or 5.5 may run. Preserve evidence before attempting recovery.
6. Decision Log pairing and legacy compatibility (NF-03)
6.1 Exact isolated template correction
In templates/04-APP-FLOW/10-DECISION-LOG.md, correct the deterministic reconstruction token:

- incorrect: decision_event_kind: STATUS_CHANGED
- canonical: decision_event_kind: DECISION_STATUS_CHANGED
Do not use substring replacement. The correction must not produce DECISION_DECISION_STATUS_CHANGED.
6.2 No Control sequence in Decision Log body
The Decision Log MUST NOT embed a predicted or committed control_state_seq in event bodies. This preserves v3 DLE- records and avoids a second sequence reservation problem.

The Control File's DECISION_LOG_UPDATED event is the sole commit receipt and MUST bind, at minimum:

initiative_id, decision_id, decision_log_event_id, decision_event_kind, decision_status_before_update, decision_status_after_update, affected_gate, path, resulting_sha256, and state_seq.

If optional pre-append diagnostics are desired in a new v4 record, use only Control File state_seq before append; do not require it for legacy records.
6.3 Legacy events
Historical Decision Log bytes MUST NOT be rewritten as part of migration. A record whose event type or status cannot be deterministically paired is marked LEGACY_UNVERIFIED for reconstruction purposes and MUST NOT be treated as a currently approved decision. This does not authorize silently rewriting its bytes or changing historical Control receipts.
7. Change Request state machine
7.1 Canonical states (13)
State Meaning Blocking by default?
RECORDED Immutable submission accepted into P04 intake; not yet triaged. Yes
TRIAGE Tab 01 is classifying ownership, scope, affected Gates, conflicts, and dependencies. Yes
NEEDS_CLARIFICATION More information is required before a decision. Yes
ACCEPTED_FOR_IMPLEMENTATION Owner accepted the defined P04 scope; implementation may proceed under assigned tab permissions. Yes
IMPLEMENTED_PENDING_REAPPROVAL Changes are recorded and affected Gate 1/2 approvals have been renewed; Tab 03 review/freeze remains. Yes
RETURN_TO_P03 The request crosses P04 ownership and has been returned to upstream Process 03. Yes
REVERSION_PENDING User requested cancellation after bytes changed; restoration and re-approval remain incomplete. Yes
REJECTED_WITH_NO_CHANGE Rejected in TRIAGE with proof that no relevant P04 bytes changed. No
CANCELLED_NO_CHANGE Cancelled before implementation, or accepted but proven to have changed no bytes. No
CANCELLED_AFTER_REVERSION Changes were reverted and required Gate/Review/Freeze approvals were restored. No
CLOSED_IMPLEMENTED Implemented CR is bound to one exact frozen version/hash and is terminal. No, once bound to a valid current freeze
DUPLICATE Pointer-terminal state delegating the blocking obligation to a canonical CR. Derived from target
SUPERSEDED Pointer-terminal state delegating the blocking obligation to an approved successor CR. Derived from target

NOT_VERIFIED is not a business state transition. It is a derived integrity condition and always blocks.

REFROZEN is prohibited. A closed CR binds to one freeze only. A later change requires a new CR-ID.
7.2 Closed transition set
Only T01–T18 below are legal in the reviewed 18-transition model. Any unlisted from_status → to_status pair is forbidden (fail closed). The table is the complete transition contract and carries the 11 required dimensions: ID, states, actor, exact command, machine preconditions, evidence, permissions, Register event, Control receipt, Gate effect, and bounded recovery.
ID From → To Actor Exact user command Machine-checkable preconditions Required evidence Write permission Register event / Control receipt Gate and downstream effect Bounded recovery
T01 Submission → RECORDED Tab 01 RECORD APP FLOW CHANGE SUBMISSION [SUBMISSION-ID] Control + Register VERIFIED; submission ID and payload hash are new; initiative matches. Submission ID/hash, source path/hash, current P04 snapshot. Register + Control only. CR_RECORDED / CHANGE_REQUEST_REGISTER_UPDATED No Gate invalidation before byte change; downstream blocked immediately. RECOVER CHANGE REQUEST EVENT [CRE-ID]; abort only under 5.6.
T02 RECORDED → TRIAGE Tab 01 START APP FLOW CHANGE TRIAGE [CR-ID] CR is currently RECORDED; integrity verified. Candidate Gate and candidate affected paths. Register + Control only. CR_TRIAGE_STARTED / CHANGE_REQUEST_REGISTER_UPDATED No Gate invalidation; remains blocked. Recover one valid staged event.
T03 TRIAGE → NEEDS_CLARIFICATION Tab 01 REQUEST CLARIFICATION FOR APP FLOW CHANGE [CR-ID] CR is TRIAGE; concrete unanswered questions are recorded. Questions and current hashes of related artifacts. Register + Control only. CR_CLARIFICATION_REQUESTED / CHANGE_REQUEST_REGISTER_UPDATED No Gate invalidation; remains blocked. Recover one valid staged event.
T04 NEEDS_CLARIFICATION → TRIAGE Tab 01 RESUME APP FLOW CHANGE TRIAGE [CR-ID] CR is NEEDS_CLARIFICATION; user response is present. Response summary and evidence hash, if any. Register + Control only. CR_TRIAGE_RESUMED / CHANGE_REQUEST_REGISTER_UPDATED No Gate invalidation; remains blocked. Recover one valid staged event.
T05 TRIAGE → ACCEPTED_FOR_IMPLEMENTATION Tab 01 ACCEPT APP FLOW CHANGE [CR-ID] CR in TRIAGE; P04 ownership confirmed; no unresolved conflict or graph cycle. Accepted scope, affected Gate/paths, pre-implementation hashes for artifacts 01–09. Register + Control only; no artifact edit in this transition. CR_ACCEPTED_FOR_IMPLEMENTATION / CHANGE_REQUEST_REGISTER_UPDATED Gate remains as-is until bytes change; downstream remains blocked. Recover one valid staged event.
T06 TRIAGE → REJECTED_WITH_NO_CHANGE Tab 01 REJECT APP FLOW CHANGE NO CHANGE [CR-ID] User rationale supplied; all relevant P04 artifact hashes match intake snapshot. Rejection rationale and verified unchanged hashes. Register + Control only. CR_REJECTED_NO_CHANGE / CHANGE_REQUEST_REGISTER_UPDATED No Gate invalidation; releases only this CR's blocker. Recover one valid staged event.
T07 TRIAGE → RETURN_TO_P03 Tab 01 RETURN APP FLOW CHANGE TO P03 [CR-ID] Request concerns P03-owned CAP-ID/product scope. Rationale, P03 Control hash, returned P03 frozen hash. Register + P04 Control only; never edit P03 files. CR_RETURNED_TO_P03 / CHANGE_REQUEST_REGISTER_UPDATED plus P04 invalidation record P03 source marked reopened for P04 consumption; P04 Gates 1–3 reopen; downstream blocked. Recover one valid staged event; otherwise stop and verify P03 boundary.
T08 RETURN_TO_P03 → TRIAGE Tab 01 RESUME APP FLOW CHANGE AFTER P03 FREEZE [CR-ID] P03 v2 Control is APPROVED/FROZEN; initiative matches; actual P03 hash matches P03 frozen hash and differs from this CR's own returned_p03_frozen_sha256. New P03 Control hash, new frozen hash, this CR's returned snapshot. Register + P04 Control only. CR_RESUMED_FROM_P03 / CHANGE_REQUEST_REGISTER_UPDATED P03 source VERIFIED at new hash; P04 Gates remain reopened for revalidation. Recover one valid staged event; compare each CR to its own return snapshot.
T09 RETURN_TO_P03 → TRIAGE Tab 01 RESOLVE P03 RETURN WITHOUT UPSTREAM CHANGE [CR-ID] P03 remains APPROVED/FROZEN and actual P03 hash still equals this CR's returned snapshot; user supplies rationale. User rationale and verified unchanged P03 hashes. Register + P04 Control only. CR_P03_RETURN_RESOLVED_NO_UPSTREAM_CHANGE / CHANGE_REQUEST_REGISTER_UPDATED P03 source returns VERIFIED; CR resumes triage; P04 Gates still require valid reapproval if previously reopened. Recover one valid staged event.
T10 ACCEPTED_FOR_IMPLEMENTATION → IMPLEMENTED_PENDING_REAPPROVAL Tab 01 RECORD APP FLOW CHANGE IMPLEMENTATION [CR-ID] Owner tabs changed only accepted files; required Gate 1 and/or Gate 2 approvals are new and later than acceptance. Implemented hashes, approval state sequences, ID-to-artifact traceability. Register + P04 Control only; prior artifact edits remain owned by Tab 01/02. CR_IMPLEMENTATION_RECORDED / CHANGE_REQUEST_REGISTER_UPDATED Gate 1/2 approved at new hashes; Gate 3 awaits independent review/freeze. Recover one valid staged event; re-read on-disk Gate receipts before recording.
T11 IMPLEMENTED_PENDING_REAPPROVAL → ACCEPTED_FOR_IMPLEMENTATION Tab 01 REOPEN APP FLOW CHANGE IMPLEMENTATION [CR-ID] Tab 03 review found blockers or Owner requires implementation correction. Reopen rationale and Finding IDs/review round, if applicable. Register + Control only; next artifact edits remain with original owner tab. CR_IMPLEMENTATION_REOPENED / CHANGE_REQUEST_REGISTER_UPDATED Affected Gate(s) reopen when files change; downstream remains blocked. Recover one valid staged event.
T12 IMPLEMENTED_PENDING_REAPPROVAL → CLOSED_IMPLEMENTED Tab 01 CLOSE IMPLEMENTED APP FLOW CHANGE [CR-ID] A valid GATE_3_FROZEN event exists; this CR was reviewed; frozen artifact hash matches; this CR belongs to the freeze batch. Frozen version, GATE_3_FROZEN state sequence, APP_FLOW SHA-256, review evidence. Register + Control only. CR_CLOSED_IMPLEMENTED / CHANGE_REQUEST_REGISTER_UPDATED Releases this CR only after receipt verification; downstream remains blocked while any other blocker exists. Recover one valid staged event; do not repeat an ambiguous close.
T13 RECORDED / TRIAGE / NEEDS_CLARIFICATION → CANCELLED_NO_CHANGE Tab 01 CANCEL APP FLOW CHANGE [CR-ID] CR is one of the listed pre-implementation states; it has not changed P04 bytes. Cancellation rationale and unchanged hashes. Register + Control only. CR_CANCELLED_NO_CHANGE / CHANGE_REQUEST_REGISTER_UPDATED No Gate invalidation; releases only this CR. Recover one valid staged event.
T14 ACCEPTED_FOR_IMPLEMENTATION → CANCELLED_NO_CHANGE Tab 01 CANCEL APP FLOW CHANGE [CR-ID] Accepted CR, but every relevant artifact byte still matches the T05 pre-implementation snapshot. Cancellation rationale and full unchanged-hash comparison. Register + Control only. CR_CANCELLED_NO_CHANGE / CHANGE_REQUEST_REGISTER_UPDATED No Gate invalidation; releases only this CR. If any byte changed, T14 is forbidden and T15 is required. Recover one valid staged event.
T15 ACCEPTED_FOR_IMPLEMENTATION or IMPLEMENTED_PENDING_REAPPROVAL → REVERSION_PENDING Tab 01 START APP FLOW CHANGE REVERSION [CR-ID] User requests cancellation after byte changes or after implementation was recorded. Reversion rationale and target baseline hashes. Register + Control only; restoration is performed by artifact owner tab. CR_REVERSION_STARTED / CHANGE_REQUEST_REGISTER_UPDATED Reopen every Gate touched by changed files; downstream blocked. Recover one valid staged event; restoration must be evidence-based.
T16 REVERSION_PENDING → CANCELLED_AFTER_REVERSION Tab 01 COMPLETE APP FLOW CHANGE REVERSION [CR-ID] All changed files restored to approved baseline; every reopened Gate is reapproved; if Gate 3 was touched, Review + Freeze are complete. Restored hashes and verified Gate approval sequences. Register + Control only after artifact/Gate work is complete. CR_CANCELLED_AFTER_REVERSION / CHANGE_REQUEST_REGISTER_UPDATED CR blocker released only after verified restoration and reapproval. Recover one valid staged event; refuse early completion.
T17 RECORDED / TRIAGE / NEEDS_CLARIFICATION → DUPLICATE Tab 01 MARK APP FLOW CHANGE DUPLICATE [CR-ID] OF [CANONICAL-ID] Source has not changed files; target exists, is not self, is same initiative, creates no cycle, and is valid open blocker or CLOSED_IMPLEMENTED with proven coverage. Canonical ID and duplicate rationale; coverage evidence if target is closed. Register + Control only. CR_MARKED_DUPLICATE / CHANGE_REQUEST_REGISTER_UPDATED Blocker delegates to canonical target; source cannot disappear if target is invalid. Recover one valid staged event; cycle/target validation is mandatory.
T18 RECORDED / TRIAGE / NEEDS_CLARIFICATION / ACCEPTED_FOR_IMPLEMENTATION (no bytes changed, or approved successor inherits complete changed scope) → SUPERSEDED Tab 01 SUPERSEDE APP FLOW CHANGE [OLD-ID] WITH [NEW-ID] New ID exists, differs, same initiative, is an open blocking target, creates no cycle; if old bytes changed, successor inheritance is explicitly approved and complete. Old/new IDs, rationale, transferred scope/path/hash evidence. Register + Control only. CR_SUPERSEDED / CHANGE_REQUEST_REGISTER_UPDATED Blocker delegates to successor; it remains blocking if the successor is missing, invalid, cancelled, or rejected without explicit transfer resolution. Recover one valid staged event; target and graph are revalidated at append time.

Transition-table consistency note: the Round 2 narrative mentions returning an accepted-but-unmodified CR to TRIAGE, but the reviewer’s closed T01–T18 table does not define that edge. v0.3 therefore does not silently permit ACCEPTED_FOR_IMPLEMENTATION → TRIAGE. The Owner must either approve this restriction or authorize a separately specified additional transition; until then, only T14 cancellation is legal when no bytes changed, and T15 reversion is required after byte changes.
7.3 Terminal-state and pointer integrity

- CLOSED_IMPLEMENTED is terminal and binds exactly one (resolved_frozen_version, resolved_freeze_state_seq, resolved_app_flow_sha256) tuple. Later changes require a new CR-ID.
- REJECTED_WITH_NO_CHANGE is terminal. New evidence requires a new submission/CR-ID linked through related_cr_ids; do not reopen the rejected CR.
- CANCELLED_NO_CHANGE and CANCELLED_AFTER_REVERSION are terminal.
- DUPLICATE and SUPERSEDED are pointer-terminal states. Their blocking behavior is projected through their target and cannot be used to erase a blocker.
- A closed target is a valid duplicate target only when the duplicate scope is proven fully covered by that target's exact frozen version/hash.
- SUPERSEDED must not point to a non-existent, self, terminal nonblocking, or cyclic target. If bytes have changed, ownership of every changed artifact and its approved scope must be explicitly inherited by the successor.
7.4 State machine consistency guard
Every state-changing Register event MUST carry the exact command, from/to status, actor tab, evidence tuple, affected paths, and current on-disk snapshot. Every transition MUST be validated against the closed set. No natural-language interpretation may create an unlisted edge.

1. Gate validity and blocking-CR reconstruction
8.1 Derived blocking function
Every reader (all three tabs and downstream consumer) MUST reconstruct CR status from the complete Register plus Control receipts. Never trust a stored count or list.

For each CR-ID:

- invalid or unreceipted chain/status/receipt → NOT_VERIFIED → blocking TRUE;
- RECORDED, TRIAGE, NEEDS_CLARIFICATION, ACCEPTED_FOR_IMPLEMENTATION, IMPLEMENTED_PENDING_REAPPROVAL, RETURN_TO_P03, REVERSION_PENDING → TRUE;
- REJECTED_WITH_NO_CHANGE, CANCELLED_NO_CHANGE, CANCELLED_AFTER_REVERSION → FALSE;
- CLOSED_IMPLEMENTED → FALSE only when its resolved freeze tuple matches a valid GATE_3_FROZEN event and its committed freeze sequence is no later than the current valid frozen Gate 3 checkpoint; otherwise TRUE;
- DUPLICATE(target) → recursively evaluate target; invalid/missing/cyclic target → TRUE;
- SUPERSEDED(target) → recursively evaluate target; invalid/missing/cyclic target or a target cancelled/rejected without explicit valid transfer resolution → TRUE.
Traversal depth MUST be bounded by the total number of CRs. Any cycle MUST be detected and return blocking TRUE. The graph validator MUST reject cycles before an append, not merely discover them during downstream reads.

A CR becomes blocking at RECORDED, not at TRIAGE. Intake is the earliest safe blocking point because an untriaged submission may invalidate assumptions used downstream.
8.2 Gate validity is separate from downstream eligibility
A newly recorded CR blocks downstream consumption immediately but does not invalidate previously approved Gates until relevant source/artifact bytes change.
Change detected Gate effect
New CR only; no relevant bytes changed Existing Gate approvals remain valid; downstream blocked by CR.
P03 frozen source changes P04 Gates 1–3 reopen; lifecycle becomes REVIEW_REQUIRED.
Artifact 01 or 02 changes Gates 1–3 reopen.
Artifact 03–06 changes Gates 2–3 reopen; Gate 1 may remain approved only if its evidence remains byte-valid.
Artifact 07 or 08 changes Gate 3 reopens.
Decision Log changes Apply the existing Gate-binding rules; Gate(s) bound to the changed Decision Log reopen.
Register becomes NOT_VERIFIED All P04 writes and downstream consumption blocked; conservative invalidation applies.
Frozen APP_FLOW.md bytes change outside a valid freeze Gate 3 reopens; lifecycle becomes REVIEW_REQUIRED; downstream blocked.

The original detailed Gate invalidation matrix in the canonical Skill remains authoritative after it is updated. This table is a summary and MUST be checked against that matrix during implementation review.
8.3 Downstream eligibility predicate
A downstream process may consume APP_FLOW.md only when all are true:

1. P04 workspace integrity is VERIFIED.
2. P04 Control File schema is v4 and every Control event sequence is valid.
3. P03 initiative ID matches and P03's actual frozen file hash matches its P03 v2 Control File frozen hash.
4. P04 gate_1, gate_2, and gate_3 are APPROVED with valid approval sequence anchors and matching current artifact hashes.
5. P04 lifecycle is FROZEN.
6. APP_FLOW.md exists and its actual SHA-256 equals the valid Gate 3 frozen artifact hash.
7. Register initialization and the full event/receipt chain verify.
8. reconstructed_blocking_cr_ids is empty.
9. Every CR in the freeze batch that reached IMPLEMENTED_PENDING_REAPPROVAL has a committed CLOSED_IMPLEMENTED event bound to that exact frozen version, Gate 3 freeze sequence, and frozen artifact hash.
10. The latest Review snapshot binds the exact Register hash, sequence, last event ID, and CR set used at Freeze.
lifecycle_status: FROZEN and gate_3.status: APPROVED alone do not authorize downstream consumption.
11. Freeze-to-CR-closure publication contract (NF-05)
9.1 Two-stage freeze publication
Tab 03 remains the only tab authorized to perform the mechanical Freeze. Tab 01 remains the only writer of the Register. Therefore a Freeze and subsequent CR closure cannot be represented as one cross-file atomic transaction.

The v0.3 contract handles this explicitly:

Stage A — Freeze committed by Tab 03

1. Tab 03 verifies Control File, Register, Decision Log, artifacts, and latest Review snapshot.
2. Register hash, last_register_seq, last_event_id, open CR IDs, blocking CR IDs, and the list of IMPLEMENTED_PENDING_REAPPROVAL CRs are snapshotted in the Review round.
3. Freeze is refused if any CR is in a state other than those explicitly eligible for the current implementation batch. In particular, RECORDED, TRIAGE, NEEDS_CLARIFICATION, ACCEPTED_FOR_IMPLEMENTATION, RETURN_TO_P03, and REVERSION_PENDING block Freeze.
4. Tab 03 writes the versioned frozen output and the GATE_3_FROZEN Control receipt. The frozen file may carry > Status: FROZEN, but this is not yet sufficient for downstream consumption.
5. The downstream predicate remains false while one or more implementation CRs are still IMPLEMENTED_PENDING_REAPPROVAL.
Stage B — CR closure by Tab 01
6. User returns to Tab 01 and executes CLOSE IMPLEMENTED APP FLOW CHANGES FOR FREEZE [FROZEN-VERSION] (batch command) or the single-item CLOSE IMPLEMENTED APP FLOW CHANGE [CR-ID] for each eligible CR.
7. Tab 01 reads the just-committed Gate 3 event and verifies the frozen version, Gate 3 state sequence, actual APP_FLOW.md hash, and Review snapshot.
8. For every CR in that exact freeze batch, Tab 01 appends an individual CR_CLOSED_IMPLEMENTED Register event and its matching Control receipt. Each receipt receives its own next monotonically increasing state_seq; no shared or repeated state sequence is allowed.
9. Each closure event binds resolved_frozen_version, resolved_freeze_state_seq (the GATE_3_FROZEN event sequence), resolved_app_flow_sha256, and the actual closure receipt sequence.
10. If interrupted midway, completed closures remain committed, unfinished CRs remain blockers, and downstream stays blocked. Resume by reading the files and closing only CRs that remain IMPLEMENTED_PENDING_REAPPROVAL; never duplicate a committed close.
11. Downstream becomes eligible only after every expected CR in the batch is validly closed and the reconstructed blocking set is empty.
No Control File status field may override the Register's business state. A convenience indicator such as downstream_freeze_publication_state may be computed for display, but it is derived and must not become a second CR status source.
9.2 Deterministic freeze versioning (NF-11)

- The first valid Freeze is frozen_version: 1.
- Each subsequent valid GATE_3_FROZEN event increments the version by exactly one (v + 1).
- Before a new Freeze, preserve the previous frozen file as [APP\_FLOW.v.md](http://APP_FLOW.v.md) using the exact prior version number.
- A no-op re-freeze is refused when all source/artifact/Decision Log/Review hashes and CR state are unchanged and no new accepted implementation is awaiting publication: Already frozen at current state; no-op re-freeze prohibited.
- A changed P03 source binding, approved artifact scope, or implemented CR batch requires a new version even if portions of output bytes remain unchanged.
- A frozen output written without a matching GATE_3_FROZEN receipt is an orphan/incomplete file and MUST NOT be consumed downstream.

1. P03 return, re-entry, and upstream drift (NF-08)
10.1 Return to P03
When a request affects P03-owned product definition or CAP-ID scope, Tab 01 records RETURN_TO_P03; it MUST NOT edit P03 files. The event stores returned_p03_control_sha256 and returned_p03_frozen_sha256 specific to that CR.
10.2 Resume after a new P03 freeze
RESUME APP FLOW CHANGE AFTER P03 FREEZE [CR-ID] compares the new actual P03 frozen hash with the returned_p03_frozen_sha256 stored in that particular CR's return event, not with a mutable global current P04 hash. This permits several CRs to resume against the same new P03 freeze one by one.

P03's new file hash must match P03 Control v2 gate_3.frozen_artifact.sha256; initiative IDs must match. On success, source status becomes VERIFIED at the new hash and the CR returns to TRIAGE. P04 Gates remain reopened for revalidation.
10.3 P03 returns without upstream change
If the Owner decides P03 will retain its prior frozen definition, use RESOLVE P03 RETURN WITHOUT UPSTREAM CHANGE [CR-ID]. Require a user rationale and verify P03 remains frozen with the exact hash stored in that CR's return event. The CR returns to TRIAGE; it may then be rejected, cancelled where allowed, or handled within P04 ownership.
10.4 Upstream drift not initiated by a P04 CR
If P03 has a valid new freeze not initiated by a P04 CR, P04 detects drift on tab entry, marks the P03 source binding reopened, reopens P04 Gates 1–3, sets lifecycle to REVIEW_REQUIRED, and records INVALIDATED with reason UPSTREAM_P03_DRIFT. P04 MUST NOT fabricate a CR to explain the drift.

If P03 initiative identity, actual file hash, or P03 Control receipt is inconsistent, set source status NOT_VERIFIED and stop. Do not infer or transfer P03 approval to P04.
11. Three-tab permission and disk handoff contract
11.1 Ownership matrix
Artifact / action Tab 01 — Task/Flow + CR coordinator Tab 02 — Navigation/Screens/States Tab 03 — Independent Review/Freeze
00_APP_FLOW_CONTROL.md Writes Gate 1 events, CR receipts, Register pointer, and authorized P03 binding events. Writes Gate 2 events and its authorized Decision Log receipts. Writes review receipts, residual-risk receipts, Gate 3 Freeze, and authorized invalidation events.
10_CHANGE_REQUEST_REGISTER.md Sole writer; initialize and append every CR event. Read only. Read only.
01_TASK_MODEL.md, 02_FLOW_ARCHITECTURE.md Owner/writer for Gate 1 and its CR scope. Read only. Read only.
03_NAVIGATION_MODEL.md–`06_STATE_AND_EXCEPTION_MATRIX.md` Read only; may inspect hashes/evidence. Owner/writer for Gate 2 and its CR scope. Read only.
07_FLOW_REVIEW.md, 08_APP_FLOW_DRAFT.md Read only. Read only. Owner/writer; records independent review and assembles draft.
09_DECISION_LOG.md Append-only for Gate 1 decisions. Append-only for Gate 2/3 decisions. Strictly read only.
APP_FLOW.md, [APP\_FLOW.v.md](http://APP_FLOW.v.md) Read only; verifies hashes and closes CRs after Freeze. Read only. Authorized Freeze executor; archives and publishes output after explicit user command.
CR state decisions Coordinates all CR lifecycle commands. No independent CR state updates. No independent CR state updates.

User approval is expressed through exact commands. The user does not hand-edit hashes or sequence numbers. P03 and downstream are read-only with respect to P04 workspace state.
11.2 Disk is the handoff channel
The tabs run in fresh conversations and reconstruct state from files, not prior chat history. Consequently:

- Tab 02 completes Gate 2 artifacts and the GATE_2_APPROVED Control event before returning to Tab 01.
- Tab 01 rereads Control File and Register from disk and verifies the new Gate event sequence and hashes before recording CR_IMPLEMENTATION_RECORDED.
- For mixed Gate 1+2 scope, Tab 01 completes and approves Gate 1 first; Tab 02 then completes and approves Gate 2; Tab 01 finally records the CR as IMPLEMENTED_PENDING_REAPPROVAL.
- Tab 03 snapshots the Register and Control hashes at Review start and rechecks immediately before Freeze. Any changed Register hash/sequence/event ID invalidates the Review snapshot and requires a new Review round.
- A stale chat context is never accepted as current state.
11.3 Single-writer limitation
The workflow MUST enforce one logical writer at a time and stale-read checks. It MUST NOT claim active_owner_tab or state_seq is an OS lock, atomic CAS, or distributed mutex. If actual concurrent writes occur, any duplicate sequence, lost event, unexpected hash, or malformed pair causes NOT_VERIFIED; stop and restore from a trusted backup.

1. Review snapshot and frozen downstream binding
12.1 Required Review round fields
Each ### Review round entry in 07_FLOW_REVIEW.md MUST include:

- P03 initiative ID and frozen source hash;
- P04 Control File state_seq and whole-file SHA-256 snapshot;
- Register path, schema version, full-file SHA-256, last_register_seq, last_event_id;
- all open CR IDs and reconstructed blocking CR IDs;
- CR IDs verified in this review and implementation CR IDs expected in the Freeze batch;
- Decision Log path/hash and relevant event references;
- artifact hashes for 01–06 and draft 08;
- latest Review round identity/hash and findings dispositions;
- test environment, reproduction evidence, and review verdict.
Freeze MUST be refused if the current Register snapshot differs from the Review snapshot.
12.2 Downstream binding tuple
P04 publishes evidence through the Control File, Register, and frozen APP_FLOW.md; it MUST NOT add a circular whole-file hash inside APP_FLOW.md.

A downstream reader must verify at least these 12 binding groups:

1. initiative_id is identical in P03 Control, P04 Control, Decision Log, Register, and APP_FLOW.md.
2. p04_schema_version == 4.
3. P04 lifecycle_status == FROZEN and gate_3.status == APPROVED.
4. frozen_version is a positive integer matching the latest valid GATE_3_FROZEN event.
5. Actual product/app-flow/APP_FLOW.md SHA-256 matches the Control File frozen artifact hash and the Freeze event.
6. reviewed_draft_sha256 and latest_review_sha256 prove the frozen output came from the independently reviewed draft; the frozen output differs only by the approved status line.
7. gate_1.approved_state_seq, gate_2.approved_state_seq, and gate_3.approved_state_seq exist in P04 v4, are ordered, and point to valid matching Gate events and current approved artifact hashes.
8. source_process_03 matches P03 v2 initiative ID, status VERIFIED, frozen path, frozen hash, and actual bytes.
9. change_request_register path/schema/hash/sequence/last event matches disk, and the full chain is verified.
10. reconstructed_blocking_cr_ids == [].
11. Every implementation CR in the freeze batch is CLOSED_IMPLEMENTED and bound to the same frozen version, Gate 3 freeze sequence, and APP_FLOW.md hash.
12. Accepted residual risks are explicitly recorded and approved by the Owner for downstream inheritance.
The P04 downstream contract proves artifact and workflow integrity; it does not determine whether a hash change is semantically major or minor. That policy belongs to the downstream process.
13. Schema v3 → v4 migration contract (NF-09)
13.1 Migration command and attestation
Migration requires an explicit user command and one of two mutually exclusive paths:

- MIGRATE APP FLOW CONTROL V3 TO V4 WITH ZERO EXTERNAL CRS — user attests that no unrecorded/out-of-band CRs are pending.
- MIGRATE APP FLOW CONTROL V3 TO V4 WITH PENDING SUBMISSIONS — migration may proceed only into a blocked/review-required state; pending payloads are registered through Tab 01 after migration.
The operator MUST NOT infer the absence of unrecorded CRs from the old change_requests: [] field alone. The user attestation is explicit and recorded in migration evidence.
13.2 Preconditions
- P04 v3 Control File is structurally readable and its event sequence is valid.
- P03 v2 identity and frozen binding are verified.
- The migration tool/agent has read the exact approved v3 schema and migration plan.
- All required P04 artifact hashes and old approval sequences have been captured.
- The user selects one of the two explicit migration commands.
- No other writer is active.
13.3 Backup and manifest
Before changing any file, create a byte-preserving backup of the full active P04 workspace, including Control File, Decision Log, Review history, artifacts, draft, frozen output, and relevant README state. Create ARCHIVE_MANIFEST.md recording relative path, byte size, SHA-256, schema version, initiative ID, source HEAD, timestamp, and backup destination. Verify every backup hash before proceeding.
13.4 Preserve only verified approvals
Migration MAY preserve a v3 Gate approval only if:
- the relevant v3 event exists exactly once and has a valid state_seq;
- the v3 approval sequence fields match the latest valid events;
- all artifact hashes, Decision Log hash, Review hash, reviewed draft hash, frozen output hash, and P03 source hash still match the bytes on disk;
- the v3 event log has no sequence gaps or integrity conflicts.
If a relevant hash does not match, reopen the affected Gate conservatively before or during migration. Do not blanket-reset all approvals when they remain verifiably valid, and do not preserve approval merely because the old Control File says APPROVED.

Legacy Decision Log records with unmatched status tokens remain byte-identical and are marked LEGACY_UNVERIFIED for current reconstruction.
13.5 One logical migration transaction, one Control File replacement
To resolve the initialization/SCHEMA_MIGRATED ambiguity:

1. Preserve and verify the v3 backup and manifest.
2. Create the v1 Register header with correct initiative identity and compute H_init.
3. Construct the complete v4 Control File in a temporary file. It MUST contain both sequential Control events:

 - SCHEMA_MIGRATED (from_schema_version: 3, to_schema_version: 4, migration command/attestation, backup manifest hash, preserved/reopened Gate summary);
 - CHANGE_REQUEST_REGISTER_INITIALIZED (register_seq: 0, last_event_id: INITIALIZATION, last_verified_sha256: H_init, path and Register schema version).

4. Assign distinct strictly increasing Control state_seq values to those two events.
5. Validate the temporary v4 Control File and all hashes before replacing the active v3 Control File.
6. Replace the Control File in one complete filesystem replacement operation on the same filesystem; do not expose a partially serialized v4 file.
7. Read the new Control File and Register back from disk and verify both events, the checkpoint, the manifest, and the v4 schema.
8. Treat migration as complete only after read-back succeeds.
The two Control events are one logical migration transaction and one complete Control File replacement. The Register initialization receipt is not deferred to a later chat/session.
13.6 Interrupted migration recovery

- If failure occurs before the v4 Control File replacement, retain v3 as canonical; remove or quarantine only the newly created uncommitted Register after preserving its bytes as evidence.
- If replacement may have occurred but caller confirmation is missing, reopen and read both files. If v4 Control + initialization receipt + Register hash all verify, treat migration as complete; do not rerun.
- If active Control is corrupt or the pair is inconsistent, restore the complete v3 workspace byte-for-byte from the verified archive and verify every path against ARCHIVE_MANIFEST.md; then restart migration only after correction.
- Never leave a v3 Control File paired with an unreceipted v4 Register and claim migration success.
13.7 Inherited frozen v3 workspaces
A v3 workspace previously marked FROZEN may preserve that historical Gate 3 evidence only if all v3 frozen hashes and receipts verify. The v4 Register initialization is anchored by the migration transaction. If the user selected ZERO EXTERNAL CRS, the new Register starts at sequence 0 and has no blocking CRs. If the user selected PENDING SUBMISSIONS, downstream remains blocked until every pending payload has been registered and resolved. A historical v3 Freeze does not create CLOSED_IMPLEMENTED CR records retroactively.

1. File impact matrix
The following changes are mandatory for the implementation phase. Exact edits must be made only after Owner approval and after verifying the current repository baseline.
Path Classification Required change
.agents/skills/app-flow/SKILL.md MUST CHANGE Canonical contract: CR states/transitions, init, paired protocol, abort/recovery, hash rules, Gate effects, three-tab ownership, blocking algorithm, P03 re-entry, migration, downstream binding.
templates/04-APP-FLOW/00-APP-FLOW-CONTROL.md MUST CHANGE Schema v4, remove change_requests: [], add Register checkpoint and event receipts, migration 3→4, abort receipt type, initialization event.
templates/04-APP-FLOW/11-CHANGE-REQUEST-REGISTER.md MUST CREATE Register v1 header, canonical encoding, CRE block schema, event enum, prefix chain and abort marker shape.
templates/04-APP-FLOW/10-DECISION-LOG.md MUST CHANGE Correct only decision_event_kind: STATUS_CHANGED to DECISION_STATUS_CHANGED; do not add committed control_state_seq to event body.
templates/04-APP-FLOW/07-FLOW-REVIEW.md MUST CHANGE Add exact Register hash/sequence/event, open/blocking CR snapshot, batch CR IDs, and recheck fields.
prompts/04-APP-FLOW/01-TASK-MODEL.md MUST CHANGE Initialize/verify Register on entry; Tab 01 sole CR coordinator; exact lifecycle command reference to Skill.
prompts/04-APP-FLOW/02-NAVIGATION-FLOW.md MUST CHANGE Read-only Register entry check; only edit accepted Gate 2 scope; return to Tab 01 after on-disk Gate 2 approval.
prompts/04-APP-FLOW/03-INDEPENDENT-REVIEW.md MUST CHANGE Read-only Register audit, Review snapshot, freeze blocker rules, post-freeze handoff to Tab 01 for CR closure.
app-flow-kit/README.md MUST CHANGE List active artifact 10 and template 11 mapping, user commands, migration summary, point to Skill.
app-flow-kit/VERIFICATION-CHECKLIST.md MUST CHANGE Static checks, v4 schema, hash/receipt verification, 20 stress cases, runtime test register (NOT RUN until performed).
product/app-flow/README.md MUST CHANGE Upgrade schema reference to v4; list 10_CHANGE_REQUEST_REGISTER.md (Owner: Tab 01); define downstream eligibility using Register and blocking set.
README.md MUST CHANGE Change working artifacts from 01–09 to 01–10; add Register integrity and zero-blocking-CR handoff requirements.
P04 functional templates 01–06, 08, 09 NO CHANGE Do not embed CR business-state machinery into functional artifacts.
All P03 templates/prompts/Skill/kit STRICTLY NO CHANGE Preserve P03 schema v2 and ownership.
Processes 01, 02, 05, 06, 07 OUT OF SCOPE No policy or file changes in this remediation.

14.1 Canonical contract placement
The complete state machine, transaction protocol, migration, permissions, and downstream rules are defined once in SKILL.md. Templates encode fields and event shapes. Prompts only enforce tab-specific duties and link to the Skill. README files summarize, not redefine. The Verification Checklist tests the canonical contract without creating a competing copy.
15. Failure simulation suite
The following 20 scenarios are mandatory static/simulation tests. Expected outcomes are summarized here; detailed step-by-step test fixtures and assertions must be added to app-flow-kit/VERIFICATION-CHECKLIST.md during implementation.
Test Scenario Required expected result
ST-01 Initialize Register with null Control pointer Create header-only Register; commit CHANGE_REQUEST_REGISTER_INITIALIZED; register_seq: 0, non-null init hash.
ST-02 Register exists with wrong Initiative ID NOT_VERIFIED; do not rewrite identity or accept its hash as baseline.
ST-03 One complete staged tail without receipt Block all writes; recover only by validating trusted prefix and re-evaluating preconditions.
ST-04 Receipt has wrong event_block_sha256 NOT_VERIFIED; no auto-correction of receipt.
ST-05 Duplicate Control receipts for one Register event NOT_VERIFIED; restore trusted Control File.
ST-06 register_seq gap NOT_VERIFIED; restore trusted Register/Control pair.
ST-07 Control state_seq gap NOT_VERIFIED; never invent the missing event.
ST-08 More than one unreceipted Register tail event Reject normal recovery; allow only the exact two-event staged+abort pair through RECOVER CHANGE REQUEST ABORT; otherwise restore to last trusted Register hash.
ST-09 Tab 01 uses stale chat state after Tab 02 Gate 2 approval Tab 01 rereads disk and uses new Gate receipt/sequence; stale memory ignored.
ST-10 Tab 02 edits Gate 2 while Gate 1 is reopened Stop at Tab 02 Entry Gate; no Gate 2 edits.
ST-11 Register changes after Tab 03 Review snapshot Freeze refused; new Review round required.
ST-12 Freeze succeeds but CR closure receipt fails Downstream stays blocked; recover the single staged close or abort; do not report eligible.
ST-13 Two CRs return to P03 and resume against one new P03 freeze Each CR compares against its own returned_p03_frozen_sha256; both may resume.
ST-14 Supersede target missing or terminal-invalid Reject before append; original CR remains blocking.
ST-15 User cancels after a partial artifact edit Reject T14; require T15 reversion and T16 after Gate restoration.
ST-16 Reversion bytes restored but required Gate approval missing Reject T16; remain REVERSION_PENDING.
ST-17 New evidence arrives after terminal rejection Preserve old CR; create new submission/CR linked to old ID.
ST-18 v3→v4 migration interrupted Restore/verify full v3 archive or verify completed v4 pair; never claim partial success.
ST-19 Legacy v3 reader reads v4 Control File Fail closed with unsupported schema; no writes.
ST-20 New CR appears after prior CR closed in v1 Old CR remains bound to v1; new CR blocks downstream until resolved for a later version.

Additional targeted tests MUST cover: one staged event whose expected Control sequence has been consumed by an unrelated event; abort-pair hash edges H(k-1) → H(k) → H(k+1), one-receipt coverage, and recovery when the complete abort pair exists but its receipt is missing; canonical LF/UTF-8 enforcement; prefix-chain tampering; cycles across duplicate/supersession/dependency edges; no-op re-freeze; mixed Gate 1+2 handoff; and downstream eligibility after a partially completed multi-CR close batch.
16. Implementation sequence and phase gates
No phase from 1 onward may begin until Phase 0 is approved and complete. All implementation work MUST occur on a dedicated branch; no direct commits to main.
Phase Scope Exit criteria
0 Owner architecture approval; incorporate all required NF-01…NF-12 amendments; resolve explicit Owner decisions for ADR-P04-01…10 and all five clarification items (CL-01 through CL-05) in Section 17. All P0/P1 decisions approved; no contradictory protocol rules; v0.3.1 micro-diff accepted.
1 Isolated Decision Log enum correction in 10-DECISION-LOG.md. Grep confirms zero exact occurrences of decision_event_kind: STATUS_CHANGED and zero accidental DECISION_DECISION_STATUS_CHANGED across affected P04 Skill/templates. Separate commit.
2 Create Register template v1 and upgrade Control template to schema v4. Exact schema/field/event names agree; init and update/abort receipts validate; migration event supports v3→v4.
3 Update canonical Skill and Review template. Skill fully defines serialization, hash/receipt chain, initialization, recovery/abort, state machine, blockers, 3-tab permissions, P03 re-entry, migration, Freeze closure, downstream tuple. Review captures required immutable snapshots.
4 Update the three P04 prompts. Tab 01 sole Register writer; Tab 02 only edits Gate 2 scope and hands off via disk; Tab 03 read-only Register reviewer and mechanical Freeze executor. No prompt duplicates or contradicts Skill rules.
5 Update all README files and Verification Checklist. All docs show artifacts 01–10, correct template mapping, schema v4, downstream requirements; all 20 stress tests and additional edge cases included. product/app-flow/README.md is mandatory.
6 Static verification and independent Hard Review on actual implementation diff. No unresolved P0/P1/P2 findings; schema consistency and tests pass; no P03/out-of-scope changes; dedicated branch diff reviewed.
7 Live Windows Antigravity three-tab runtime testing and Owner merge approval. At least six end-to-end runtime flows pass with actual file/log/hash evidence; runtime test statuses change from NOT RUN to PASS only with evidence; Owner explicitly approves merge.

16.1 Minimum live runtime flows
At minimum, test:

1. Fresh P04 initialization with zero CRs.
2. Gate 1 CR from intake through implementation, Review, Freeze, and closure.
3. Gate 2 CR using Tab 02 disk handoff to Tab 01.
4. Mixed Gate 1+2 CR and ordered approvals.
5. P03 return/re-entry, including no-upstream-change resolution.
6. Freeze with multiple implementation CRs, interrupted close receipt, recovery, and downstream eligibility check.
Also test migration of a verified v3 workspace and at least one deliberately invalid/NOT_VERIFIED recovery case before declaring runtime confidence.
7. Owner decision register and explicit clarifications
All Owner Decision cells intentionally remain PENDING. The reviewer recommendation is not an Owner approval.
ADR Decision Reviewer recommendation carried into v0.3 Owner decision
ADR-P04-01 Decision Log enum and pairing Accept with modification: fix token; preserve legacy bytes; Control receipt alone carries committed sequence. PENDING
ADR-P04-02 Sole CR source of truth Accept with modification: Register owns CR status; Control File stores pointer/receipts only; initialize at seq 0. PENDING
ADR-P04-03 Paired append-and-receipt protocol Accept with modification: no planned Control seq in Register; canonical LF serialization; full prefix verification; bounded recovery and explicit abort-pair exception. PENDING
ADR-P04-04 Submission boundary and CR-ID ownership Accept: immutable intake payload; Tab 01 alone assigns CR-ID after source/hash/dedup verification. PENDING
ADR-P04-05 Tab 01 sole CR coordinator and three-tab permissions Accept with modification: disk-persisted Gate approval receipts are cross-tab handoff evidence; no chat-memory handoff. PENDING
ADR-P04-06 CR lifecycle Accept with modification: 13 states; no REFROZEN; T01–T18 closed transitions; exact commands/evidence; reopen/reversion paths; graph validation. PENDING
ADR-P04-07 Gate validity vs downstream eligibility Accept with modification: blocking starts at RECORDED; reconstruct blockers; downstream remains blocked until post-Freeze CR closure receipts verify. PENDING
ADR-P04-08 P03 return and same-CR re-entry Accept with modification: keep CR-ID; retain P03 v2; add T09 no-upstream-change resolution; compare each CR with its own return snapshot. PENDING
ADR-P04-09 P04 Control schema v4 and migration Accept with modification: preserve only hash-verified v3 approvals; explicit zero-CR or pending-submission attestation; backup manifest; Register init and migration in one logical Control replacement. PENDING
ADR-P04-10 Frozen downstream binding Accept with modification: Control + Register + APP_FLOW evidence tuple; deterministic frozen version; no no-op re-freeze. PENDING

17.1 Clarifications introduced while consolidating v0.3
These clarifications close internal ambiguities found while translating the reviewer report into a single contract. They require explicit Owner approval before implementation:

CL-01 — Abort semantics and receipt exception. Approve the Section 4.4 / 5.5 / 5.6 abort commit unit: preserve the staged business event at sequence k; calculate its intermediate prefix hash H(k) without publishing it as a checkpoint; append the abort marker at k+1 with previous_register_sha256: H(k); and commit the pair with exactly one CHANGE_REQUEST_EVENT_ABORTED receipt binding the prior trusted hash H(k-1), both event-block hashes, intermediate hash H(k), and final hash H(k+1). The Control checkpoint advances directly from k-1 to k+1; the staged event is ABORTED_NOT_EFFECTIVE, the marker is audit-only, and neither changes CR business state. If the marker is present but the receipt is missing, RECOVER CHANGE REQUEST ABORT [STAGED-CRE-ID] writes only the missing receipt after validating the exact pair; it never appends a second marker. This is the sole exception to the normal one-event/one-`CHANGE_REQUEST_REGISTER_UPDATED` receipt rule. If not approved, a different fully specified append-only abort model is required before implementation.

CL-02 — Initialization anchor. Approve CHANGE_REQUEST_REGISTER_INITIALIZED as a dedicated Control event at register_seq: 0, containing the non-null hash of the header-only Register. Normal transition receipts begin at register_seq: 1. This avoids pretending the zero-event initialization is a normal CHANGE_REQUEST_REGISTER_UPDATED event.

CL-03 — Migration write boundary. Approve migration as one logical transaction and one complete Control File replacement containing sequential SCHEMA_MIGRATED and CHANGE_REQUEST_REGISTER_INITIALIZED events, after a verified backup and Register creation. Interruption handling follows Section 13.6.

CL-04 — Accepted-but-unmodified CR re-triage. The reviewer narrative mentions returning an accepted CR to TRIAGE when no bytes changed, but the 18-edge table does not include that transition. v0.3 keeps the T01–T18 table closed and disallows that edge. Owner must approve this restriction or request a separately specified T19 before the state machine is frozen.

CL-05 — Batch closure behavior. Approve one batch command as an operator convenience that expands into individual CR close events and individual monotonically increasing receipts. A partial batch remains blocked; recovery resumes only uncommitted CR closures.
18. Final release criteria — no implementation before PASS
All criteria below are mandatory. A partial pass is not authorization to implement.

- Owner explicitly approves ADR-P04-01 through ADR-P04-10, with any required modifications.
- Owner explicitly approves CL-01 through CL-05, or the specification is revised to resolve them.
- NF-01 closed: no predicted Control sequence in Register; valid recovery at the next available sequence; append-only abort behavior fully specified.
- NF-02 closed: canonical byte serialization and full prefix-chain validation from initialization through last committed event.
- NF-03 closed: no committed control_state_seq in Decision Log bodies; Control receipt is the only sequence anchor.
- NF-04 closed: complete T01–T18 transition contract is consistent with the canonical state enum and all commands/events/evidence/recovery rules.
- NF-05 closed: Freeze and CR closure are two explicit stages; downstream remains blocked until every freeze-batch CR closure is committed and verified.
- NF-06 closed: all v4 workspaces initialize Register at seq 0 with a non-null hash.
- NF-07 closed: cross-tab handoff is persisted to disk through Gate approval events; stale conversation context is ignored.
- NF-08 closed: T09 exists; every P03 return is compared to that CR's own return snapshot; multiple CRs can resume against one P03 freeze.
- NF-09 closed: migration backup + ARCHIVE_MANIFEST.md, explicit external-CR attestation, preservation of only verified approvals, one logical migration transaction, and deterministic rollback are specified.
- NF-10 closed: duplicate/supersession/dependency targets are validated for existence, state, initiative, scope inheritance, and cycles before append.
- NF-11 closed: frozen version increments by one per valid new Freeze; no-op re-freeze is refused.
- NF-12 closed: product/app-flow/README.md is MUST CHANGE and synchronized.
- P03 is untouched and remains schema v2; no invented P03 fields are required.
- No downstream policy is embedded in P04 beyond the published binding/evidence contract.
- All 20 static stress scenarios and additional CL/edge-case tests are present in the Verification Checklist.
- Current repository HEAD and exact paths are freshly reverified before work begins.
- Implementation is on a dedicated branch, not main.
- Static Hard Review has zero unresolved P0/P1/P2 findings on the actual diff.
- Runtime tests remain NOT RUN until executed on Windows Antigravity with evidence; at least six minimum flows pass before merge approval.
- Owner explicitly approves the final merge after reviewing the diff and runtime evidence.
Only when every item is satisfied may the implementation status move from HOLD to GO.

1. Known limitations and evidence provenance
This v0.3.1 is a narrowly scoped micro-diff correction to v0.3. Its two change requests are grounded in the user-supplied Round 3 diff-only review: D3-01 (abort-pair/hash-chain semantics) and D3-02 (clarification count). The wider v0.3 content continues to be based on the Round 2 report in “Văn bản đã dán (1)(20261112-073212).txt”, sections A–N and Final Release Criteria. It preserves the reported repository baseline and does not claim a fresh GitHub inspection, repository implementation, or Antigravity runtime test. The micro-diff re-review below is a document-level consistency check only.

The source is a plain-text file and has no stable printed page numbers or embedded page images. Section labels, finding IDs, transition IDs, and test IDs are used as precise locators instead.

No repository files were modified. No commit, branch, pull request, migration, or runtime action was performed.
20. Change log
Version Change
0.2 Prior remediation proposal reviewed as HOLD in Independent Hard Review — Round 2.
0.3 Consolidates NF-01…NF-12; adds canonical Register serialization and chain verification; defines initialization, recovery and abort; corrects Decision Log pairing; expands CR transition contract; closes Freeze-to-closure gap; defines P03 re-entry, v3→v4 migration, three-tab permissions, downstream binding, file impact, 20 stress tests, implementation phases, ADR register, and release criteria. Owner decisions remain PENDING.
0.3.1 Micro-diff correction only: defines the abort pair as one receipt unit with an explicit intermediate hash H(k) that is not a committed checkpoint; adds deterministic recovery for a complete abort pair with a missing receipt; aligns the Phase 0 requirement with all five clarifications CL-01…CL-05. No other v0.3 policy is reopened. Owner decisions remain PENDING.

1. Micro diff re-review — D3-01 and D3-02 only
Finding Corrected locations Verification result
D3-01 — Abort pair vs. committed hash-chain checkpoints Sections 4.1, 4.4, 5.2, 5.4, 5.5, 5.6, 5.7; Section 15 ST-08/additional tests; CL-01 PASS: the staged event links from the trusted checkpoint; the abort marker links from the intermediate hash; one abort receipt binds prior/intermediate/final hashes and both event blocks; the checkpoint advances directly across the two-event unit; recovery of a complete pair writes only the missing receipt.
D3-02 — Phase 0 clarification count Section 16, Phase 0; Section 17.1 (CL-01… `CL-05` ) PASS: Phase 0 explicitly requires all five clarification items.

Review scope: This is a targeted document-level micro diff review of D3-01 and D3-02 only. It is not a new full-document review, repository verification, static implementation test, or Antigravity runtime test. No repository files were changed. ADR-P04-01…ADR-P04-10 and CL-01…CL-05 remain PENDING until the Repository Owner explicitly decides. The document remains DRAFT_FOR_OWNER_DECISION — HOLD; implementation is not authorized.</long_text_quote>1plan của P4 nè xem qua luôn

---

### 🤖 WorkBuddy AI

Đọc xong. Trước khi nhận xét, đối chiếu plan với repo thật — vì plan tự đặt ra luật "hai artifact mâu thuẫn thì workspace là NOT_VERIFIED":

---

### 🤖 WorkBuddy AI

Tìm thấy 3 lỗi thật. Sửa cái nặng nhất trước — nó nằm ngay trong canonical contract:

---

### 🤖 WorkBuddy AI

Đọc hết. Plan này về mặt kỹ thuật là **tốt thật** — bảng T01–T18 với 11 chiều mỗi dòng, hash chain, abort pair, migration có manifest. Không phải loại tài liệu viết cho có. Nhưng tôi tìm được 3 lỗi, và cái thứ ba nặng hơn cái bạn biết.

**1. Lỗi tự tham chiếu — đúng chỗ tôi đã sửa.** Section 4.3 bắt event body chứa `event_block_sha256`; Section 4.4 định nghĩa nó là SHA-256 của "exact UTF-8/LF bytes from the first byte of `### CRE-<NNNN>` through the LF after `event_end_marker: END_CRE`". Trường đó nằm trong vùng đó. Không có nghiệm. Đã xử lý bằng ADR-P04-11 (sentinel). Điểm tôi phải kiểm thêm: abort marker ở Section 5.6 cũng có `event_block_sha256` riêng, nên quy tắc sentinel phải áp cho **mọi** event, không riêng event thường — câu tôi viết trong Skill nói "the event block", bao trùm cả hai.

**2. Plan và decision register đang nói ngược nhau.** Plan ghi `Status: DRAFT_FOR_OWNER_DECISION — HOLD` (dòng 9), "Owner decisions remain PENDING" (dòng 947, 948, 957), "implementation is not authorized", "No repository files were modified" (dòng 938). Register thì ghi `ALL OWNER DECISIONS APPROVED`, `Implementation authorization: GRANTED`, 16/16. Trong khi nhánh đã có 14 commit implementation.

Điều làm chuyện này nghiêm trọng: **Section 0.2 của chính plan** nói nếu hai artifact mâu thuẫn thì workspace là `NOT_VERIFIED` cho tới khi sửa xong. Tức plan đang tự kết án workspace của nó. Tôi không sửa plan — nó là artifact đã duyệt, có SHA-256 ghi trong provenance, và mọi câu đó đều **đúng tại thời điểm viết**. Tôi tạo `P04-STATUS-RECONCILIATION-2026-11-12.md`: liệt kê từng câu sai thời điểm kèm số dòng, và cơ quan nào thay thế nó.

**3. Lỗi nặng nhất — trong canonical contract, và nó fail-closed theo kiểu nguy hiểm.** Skill dòng 118 (thân bài v3) viết: *"Migration is permitted only after the user sends exactly MIGRATE APP FLOW CONTROL V2 TO V3"*. Skill dòng 513 (mục v4 mới thêm) yêu cầu `MIGRATE APP FLOW CONTROL V3 TO V4 WITH ZERO EXTERNAL CRS`. Hai câu không thể cùng đúng.

Hậu quả cụ thể: một Tab 01 đọc từ trên xuống sẽ gặp dòng 118 trước, kết luận lệnh v3→v4 là **bất hợp pháp**, rồi dừng và báo `NOT_VERIFIED`. Và nó sẽ **báo đúng** — theo nghĩa nó tuân thủ đúng câu nó đọc được. Một lỗi mà hệ thống tự xác nhận mình đúng là loại khó phát hiện nhất.

Nguyên nhân gốc: **v4 được thêm vào như một section, không được tích hợp vào thân bài.** Nên ngôn ngữ v3 thì hiện tại, v4 thì nằm dưới như phụ lục. Tôi đã sửa thành chuỗi v2 → v3 → v4, không nhảy cóc, không thay lệnh, và ghi rõ: file schema v3 nhận lệnh v2→v3 là `NOT_VERIFIED`, không phải no-op.

---

Tôi phải nói một điều về bức tranh lớn, vì nó quan trọng hơn cả 3 lỗi trên.

P04 v4 hiện có: 13 trạng thái CR, 18 transition, abort pair với hash trung gian H(k), prefix chain, migration có manifest, 22 stress test — cho một quy trình **chưa chạy lần nào**. Tỷ lệ giữa độ phức tạp cơ chế và bằng chứng thực nghiệm đang rất lệch. Chính Process 02 của repo (Discovery) gọi đây là xây trước khi kiểm chứng giả định rủi ro nhất — và giả định rủi ro nhất ở đây không phải "CR register có đủ chặt không", mà là **"mô hình 3 tab có chạy nổi khi có người thật dùng không"**.

Cái đó chỉ trả lời được bằng một lần chạy thật, không bằng thêm 200 dòng đặc tả.

---

Trạng thái nhánh: **15 commit trước main**, chưa push. Còn treo: runtime `NOT RUN`, merge chưa được duyệt, Register writer chưa tồn tại (nên quy tắc sentinel chưa từng chạy trên bytes thật).

Câu hỏi duy nhất còn chặn đường — và nó là câu cũ, chưa được trả lời:

❓ **Q11 (nhắc lại)** - **Platform của app là gì?** Repo tên `app-adr-ui`, cả đoạn chat nói Android, impeccable có `android.md` — nhưng trong repo không có một dòng xác nhận. P6 đang để nó là câu hỏi mở, và nó quyết định minimum target size, type scale, elevation, Material 3, window insets, system Back.

➡️ **(a) Android native (Compose + Material 3).** Nếu đúng, tôi thêm `platform` vào Control template P6 như một recorded decision bắt buộc — để không ai phải suy ra từ tên thư mục, và để `android.md` thành ràng buộc kiểm tra được ở Gate thay vì tài liệu tham khảo.

---

### 👤 User

yes to all
mà P4 5 sao r

---

### 🤖 WorkBuddy AI

"yes to all" → Android native. Chốt luôn vào charter, rồi trả lời câu về P4.

---

### 🤖 WorkBuddy AI

Chốt Android xong (`7c7ee26`, nhánh giờ 15 commit trước main). Giờ trả lời thẳng câu về P4.

**Không, chưa 5 sao.** Nhưng cũng không phải vì nó dở — vì "5 sao" đang trộn hai thứ khác nhau: *suy nghĩ tốt* và *chạy được*. Tách ra thì thế này:

| Chiều | Điểm | Vì sao |
| --- | --- | --- |
| Đặc tả | 4.5/5 | Bảng T01–T18 với 11 chiều mỗi dòng là loại kỷ luật hiếm. Tách "business state" khỏi "commit evidence", và bắt được lỗ hổng freeze→closure (NF-05) — đó là vấn đề thật mà đa số spec bỏ sót. |
| Implementation | 3/5 | Schema v4, Register v1, 3 prompt, docs — đều có. Nhưng v4 được thêm vào như phụ lục chứ không tích hợp, nên thân bài v3 vẫn nói thì hiện tại và mâu thuẫn với nó. Đó là lỗi cấu trúc, không phải sơ suất. |
| Bằng chứng | 0/5 | 22 kịch bản, tất cả NOT RUN. Register writer chưa tồn tại, nên chưa một event nào từng được sinh ra trên bytes thật. |
| Tính nhất quán | 2/5 | Sáng nay có 3 mâu thuẫn cùng lúc: hash tự tham chiếu, plan nói HOLD trong khi register nói APPROVED, và Skill nói lệnh migrate v3→v4 là bất hợp pháp. |

Điểm cuối là điểm đau nhất, vì nó không phải "thiếu tính năng" — nó là **P4 tự phủ định chính nó**. Theo Section 0.2 của plan, ba mâu thuẫn đó đủ để workspace là `NOT_VERIFIED`. Một quy trình không thể tự chứng minh mình nhất quán thì chưa thể là 5 sao, dù từng dòng viết rất kỹ.

**Vấn đề thật không nằm ở chất lượng suy nghĩ, mà ở thứ tự thi công.** P4 xây cơ chế khó nhất — Change Request Register với 13 trạng thái, 18 transition, hash chain, abort pair — trước khi mô hình 3 tab chạy được **một lần nào**. Chính Process 02 của repo gọi đó là xây trước khi kiểm chứng giả định rủi ro nhất. Và giả định rủi ro nhất ở đây không phải "register có đủ chặt không", mà là "người thật có vận hành nổi 3 tab với gate bằng lệnh gõ tay không". Chưa ai biết.

Hệ quả cụ thể: CR register tồn tại để xử lý thay đổi. Nhưng khi pipeline chưa chạy lần nào, **ta chưa biết thay đổi thật trông thế nào**. Thiết kế vòng đời 13 trạng thái cho một CR chưa từng thấy là suy đoán có kỷ luật — vẫn là suy đoán.

**Để lên 5 sao, cần đúng hai việc:**

1. **Chạy một initiative thật qua P1→P4.** Không phải để chứng minh nó đúng — mà để nó **gãy** . Chỗ gãy đầu tiên sẽ cho biết gate nào là thật, gate nào là trang trí.
2. **Sau lần gãy đó, quyết định CR register có cần cho v1 không.** Rất có thể câu trả lời là không: một luật đơn giản "thay đổi quay về tab sở hữu, mở lại gate" giải quyết 90% trường hợp với 5% độ phức tạp. Nếu đúng vậy thì 950 dòng kia là nợ, không phải tài sản.

Đó chính là **Q10 tôi hỏi từ đầu và bạn chưa trả lời**: dựng initiative mẫu để chạy thật, hay tiếp tục viết đặc tả? Mọi thứ khác đều đã sẵn sàng — P5 có contract, P6-P8 có charter, platform đã chốt. Thiếu đúng một thứ: một `APP_FLOW.md` đã freeze để bắt đầu.

---

### 👤 User

tiếp theo là

---

### 🤖 WorkBuddy AI

"Tiếp theo" là **P6 — Design Systems**. Và đây là chỗ tôi đổi ý so với lập luận lúc trước, nói rõ lý do: P6 **không phát minh cơ chế mới**. Không register, không abort pair, không migration — chỉ lặp lại đúng khuôn 3 tab của P5. Rủi ro biên thấp. Cái làm P4 đắt là nó tự chế một hệ con, không phải nó viết contract.

---

### 🤖 WorkBuddy AI

**P6 xong** — 16 file, 1.531 dòng, commit `695eae7`. Nhánh giờ 16 commit trước main.

Trạng thái chuỗi: **6/8 process đã có contract** (01→06), P7 và P8 còn là charter.

Ba luật mang toàn bộ P6, mỗi luật nhắm vào một kiểu hỏng cụ thể của design system:

| Luật | Nó chặn cái gì |
| --- | --- |
| Component phải cite SCREEN ID | Thư viện biến thành danh mục "mọi thứ tác giả tưởng tượng ra". Không có luật này, P7 sẽ ghép screen từ cái có sẵn thay vì cái cần. |
| Token 3 tầng, component không được với qua semantic | Một component token trỏ thẳng primitive là âm thầm opt-out khỏi theming và khỏi bảo đảm contrast — mà không ai thấy. |
| Contrast phải đo từ giá trị đã resolve | "Đã kiểm tra, đạt AA" là tuyên bố, không phải bằng chứng. Cặp fail thì sửa ở foundations hoặc token, không được vá bằng exception từng component. |

Thêm một thứ đáng chú ý: **platform giờ là field trong Control File**, không phải giả định. `android` / `jetpack-compose` / `material-3`, bất biến theo workspace. Đổi nó mở lại cả 3 gate, vì target size, type scale, elevation và motion budget đều suy ra từ đó. Và Material 3 là **từ vựng**, không phải quyết định — component vẫn phải có screen cite.

Tab 03 của P6 được thiết kế để soi đúng 3 kiểu hỏng mà process này thật sự sinh ra: component đầu cơ, contrast khai báo, và **composition rò rỉ** — cái cuối nguy hiểm nhất vì P7 sẽ copy trung thành mọi thứ nó tìm thấy, và design system âm thầm biến thành một bộ screen design.

---

Nói thẳng về trạng thái: **P5 và P6 đều chưa chạy lần nào.** 53 + 55 kịch bản đều `NOT RUN`. Nợ giờ đã sâu hai process. P6 không phát minh cơ chế mới nên rủi ro biên thấp — nhưng "rủi ro thấp" không đồng nghĩa "đã kiểm chứng".

**Tiếp theo** có ba đường, tôi xếp theo mức tôi khuyên:

1. **P7 — UI Design.** Nốt phần còn lại của nửa thiết kế. Đây là process có giá trị kiểm chứng cao nhất trong ba, vì nó chạm cả P4 (screen), P5 (state) và P6 (component) cùng lúc — Gate 2 của nó là một phép so sánh tập hợp bắc qua ba artifact, và nếu mô hình gate có chỗ nào không đứng được thì nó sẽ gãy ở đây.
2. **P8 — Validation.** Mỏng nhất, và là process duy nhất được phép nói "không".
3. **Chạy thật một initiative.** Vẫn là việc duy nhất biến bất kỳ dòng `NOT RUN` nào thành bằng chứng.

Tôi đề nghị **P7**, vì lý do kỹ thuật chứ không phải vì thứ tự: nó là phép thử tải cho toàn bộ kiến trúc gate. Nếu Gate 2 của P7 viết ra được mà không cần thêm cơ chế mới, nghĩa là mô hình 3 tab đủ dùng cho cả pipeline. Nếu phải chế thêm thứ gì, đó là tín hiệu P4 đã đúng khi làm vậy — hoặc sai khi làm quá sớm.

---

### 👤 User

Skill bạn lấy nguyên văn hay lấy khung thôi

---

### 🤖 WorkBuddy AI

Câu này quan trọng, và câu trả lời thật thì không được đẹp: **tôi chưa copy một byte nào.** Không nguyên văn, cũng không phải "khung" — tôi viết contract gốc và chỉ *trích dẫn đường dẫn* upstream.

Kiểm tra lại xem upstream có gì để copy được không:

---

### 🤖 WorkBuddy AI

Cả bốn đều là file đơn, tự chứa, nhỏ. Copy nguyên văn được — làm luôn:

---

### 🤖 WorkBuddy AI

Copy xong, và **nó lập tức tạo ra hai vấn đề** — đúng loại vấn đề mà chỉ copy nguyên văn mới lộ ra:

---

### 🤖 WorkBuddy AI

Câu trả lời thật, kèm thời điểm — vì nó thay đổi trong 10 phút vừa rồi:

**Trước khi bạn hỏi: tôi không copy một byte nào.** Chỉ trích dẫn đường dẫn trong bảng charter. Đó là lỗ hổng thật, không phải cách làm gọn: một đường dẫn thì agent phải tự đi lấy, và thực tế là nó không đi. "Upstream-first" thành trang trí.

**Sau khi bạn hỏi: đã copy nguyên văn 4 file**, verify byte-identical bằng blob SHA (4/4 `MATCH`):

| File | Blob SHA-1 | Dùng cho |
| --- | --- | --- |
| accessibility-review/SKILL.md | 3ef332cd… | P5 art.05, P6 art.04, P8 audit |
| ux-copy/SKILL.md | 14ad66b9… | P5 art.04 copy intent |
| design-system/SKILL.md | 0346fc13… | P6 foundations + token |
| design-critique/SKILL.md | b6eaac15… | Tab 03 của P5 và P6 |

Cộng `CONNECTORS.md`, vì cả 4 file đều link `../../CONNECTORS.md` — không copy thì mỗi file mang một link chết.

**Cái không copy, và lý do:**

- **impeccable** — playbook của nó gọi binary Rust, load `PRODUCT.md` / `DESIGN.md` qua CLI, chạy detector hook. Copy markdown trần là nhét vào repo những chỉ dẫn gọi một công cụ không tồn tại. Tệ hơn là chỉ trích dẫn.
- **user-research** — trùng phương pháp với P2 Discovery. Copy vào P5 là cho hai process cùng tranh quyền định nghĩa "evidence".

**Cái hoàn toàn là "khung" do tôi viết:** toàn bộ phần gate — SKILL.md, Control template, 3 prompt, checklist, decision log, review history. Không có upstream nào trên GitHub làm phần này. Đó vừa là điểm khác biệt của repo, vừa là phần **không có ai ngoài bạn kiểm chứng**.

---

Điều đáng nói nhất: **copy nguyên văn lập tức đẻ ra hai xung đột.** Đây không phải phiền toái — đây chính là lý do phải copy mới thấy.

1. **WCAG 2.1 vs 2.2.** Upstream ghi 2.1 AA ở 4 chỗ. Contract P5/P6 ghi 2.2 AA. Không ghi nhận thì reviewer diff hai bên sẽ thấy mâu thuẫn — hoặc tệ hơn, một tab âm thầm audit theo chuẩn cũ. Tôi **không sửa file copy** (sửa là hết verbatim, và provenance thành sai). Tôi ghi deviation vào `SOURCE.md` D-1, contract thắng.
2. **Connector giả định.** Upstream mở đầu bằng "see CONNECTORS.md", giả định Figma đã kết nối. Workflow này không có connector nào. Bước phụ thuộc connector là `NOT APPLICABLE` và phải ghi lại là đã bỏ qua — không được bịa kết quả cho khớp method.

Đó là cái giá thật của verbatim: **bản copy mang theo giả định của upstream, và không có gì trong bản copy báo cho bạn biết cái nào đã cũ.**

---

Ba kiểu quan hệ với upstream trong repo này, và mỗi process mới rơi vào đâu:

| Kiểu | Ví dụ | Khi nào dùng |
| --- | --- | --- |
| Copy nguyên văn | product-brainstorming (P1), 4 file design (P5/P6) | Upstream tự chứa, license cho phép, và nó là method chứ không phải process |
| Reference-only | ferminrp/product-shaping, impeccable | Upstream chạy nhiều phase một lúc, hoặc cần runtime → sẽ phá mô hình gate |
| Custom adapter | seed-*, app-flow, ux-design, design-system | Luôn luôn: gate, hash, quyền ghi, lệnh duyệt — không upstream nào có |

Nhánh giờ **17 commit trước main**. Việc tiếp theo vẫn là P7, hoặc chạy thật — và câu trả lời cho "copy hay khung" vừa cho thêm một lý do để chạy thật: 4 file vừa copy chưa từng được một tab nào đọc.

---

### 👤 User

repo kít này phát triển theo hướng tham khảo repo khác, lấy khung hoặc nguyên văn chứ không được tự bịa

---

### 🤖 WorkBuddy AI

Đây là một luật quản trị, không phải một câu hỏi — nên tôi phải trả lời bằng cách áp nó vào chính những gì tôi vừa viết. Trước hết kiểm chứng một chỗ tôi định viện dẫn, để không mắc đúng lỗi đang bị cấm:

---

### 🤖 WorkBuddy AI

Xác nhận: Material 3 định nghĩa đúng ba tầng — `ref` / `sys` / `comp`. Tôi đã đặt tên khác cho cùng một thứ. Đó là một dạng "tự bịa" — đổi tên một chuẩn có sẵn mà không nói.

---

### 🤖 WorkBuddy AI

Giờ phần chính: bản kiểm kê nguồn gốc cho mọi luật tôi đã viết.

---

### 🤖 WorkBuddy AI

Luật đã nhận. Nhưng phải nói ngay một điều: **"không được tự bịa" theo nghĩa tuyệt đối là bất khả thi** — không tồn tại upstream nào định nghĩa mô hình 3 tab có gate, Control File, hash binding và lệnh duyệt. Nếu cấm sạch nội dung gốc thì repo này không tồn tại từ P1.

Nên tôi biến nó thành dạng kiểm chứng được: **bịa thì được, nhưng phải dán nhãn.** Ba nhãn — VERBATIM (có blob SHA), ADAPTED (có nguồn + nói rõ đã đổi gì), LOCAL (có lý do, rủi ro, và điều kiện để bãi bỏ).

Kết quả kiểm kê 22 luật trong P5 + P6:

| Nhãn | Số | Gồm |
| --- | --- | --- |
| VERBATIM | 3 | ux-copy, design-critique, design-system |
| ADAPTED | 4 | WCAG 2.2, token 3 tầng, tonal elevation, contrast measurement |
| LOCAL | 15 | 68% |

**68% là con số thật, và nó không đẹp.** Sáu quyết định LOCAL lớn nhất:

| | Luật | Rủi ro nếu tôi sai |
| --- | --- | --- |
| L-1 | Khối ASCII trong artifact 01 | Agent tin hình hơn tin list |
| L-2 | Ba cuộc kiểm tra từ vựng | Danh sách từ vựng thô — bắt "app bar", bỏ sót "vùng header" |
| L-3 | Coverage counters | Đếm số lượng, không đếm chất lượng. Screen nào cũng có entry, entry nào cũng rỗng, counter vẫn PASS |
| L-4 | Accessibility chia 3 tầng | Đây là chỗ yêu cầu hay chết nhất: mỗi process tưởng process khác lo |
| L-5 | Component phải cite screen | Có thể đẻ ra hệ thống thiếu component, vì tối ưu cho "demand chứng minh được" chứ không cho thư viện tốt |
| L-6 | Platform bất biến | Thêm tablet sau này phải mở initiative mới — có thể quá tay |

Mỗi cái đều có mục "retired when" — tức là điều kiện để **bãi bỏ nó**. Một luật LOCAL không bao giờ bị bãi sau khi chạy thật là một luật không ai xem lại.

---

Và bản kiểm kê bắt được **một vi phạm do chính tôi gây ra**, đúng loại nó sinh ra để bắt:

P6 định nghĩa token 3 tầng là `primitive / semantic / component`. **Material 3 đã định nghĩa đúng mô hình đó là ref / sys / comp.** Tôi đổi tên một chuẩn có sẵn rồi trình bày như quyết định của mình. Hệ quả thực tế: lập trình viên Compose đọc `ref/sys/comp` trong theme file, còn spec nói từ khác — và ánh xạ 1-1 đó chỉ tồn tại trong đầu người viết.

Đã sửa: dùng nhãn tầng của Material, giữ tên token ở cấp sản phẩm (vì token sản phẩm hợp pháp nằm ở tầng `sys` và có thể mở rộng hoặc thay `md.sys.*`). Ghi rõ sự phân biệt đó thay vì để người đọc tự suy.

---

Điều khó nghe nhất, và tôi nghĩ đây là điểm chính: **68% LOCAL chính là phần làm repo này có giá trị — và cũng chính là phần không ai ngoài bạn kiểm chứng.**

Luật bạn vừa đặt không làm giảm rủi ro đó. Nó làm rủi ro **nhìn thấy được**. Trước đây một reviewer đọc P6 sẽ thấy 8 mục đều có vẻ chuẩn mực như nhau; giờ họ thấy 4 mục có Material 3 đỡ lưng và 4 mục chỉ có tôi đỡ.

Đã nối vào admission test: một process mới không được thêm vào nếu luật của nó không có nhãn. Nhánh giờ **18 commit** trước main.

---

### 👤 User

trong P 5 bạn tham khảo những repo nào

---

### 🤖 WorkBuddy AI

P5 tham khảo **đúng 2 repo**. Đây là toàn bộ, có thể kiểm chứng từng dòng:

## 1. anthropics/knowledge-work-plugins — copy nguyên văn (Apache-2.0)

| File | Size | Dùng cho |
| --- | --- | --- |
| design/skills/accessibility-review/SKILL.md | 4.278 B | Artifact 05 — taxonomy yêu cầu accessibility |
| design/skills/ux-copy/SKILL.md | 3.436 B | Artifact 04 — copy intent |
| design/skills/design-critique/SKILL.md | 3.923 B | Tab 03 — cấu trúc review |

Cộng `design/CONNECTORS.md` (1.139 B) chỉ vì cả 3 file đều link `../../CONNECTORS.md`. Tổng ~11,6 KB. Blob SHA từng file ghi trong `upstream/anthropics/knowledge-work-plugins/SOURCE.md`, đã đối chiếu 4/4 `MATCH`.

## 2. pbakaus/impeccable — chỉ trích dẫn, không copy

| Playbook | Dùng cho |
| --- | --- |
| skill/reference/shape.md | Task discovery trước mọi quyết định UI |
| skill/reference/critique.md | Thang điểm heuristic cho review |

Không copy vì playbook của nó gọi binary Rust và load `PRODUCT.md`/`DESIGN.md` qua CLI — copy markdown trần là nhét chỉ dẫn gọi một công cụ không tồn tại.

## 3. Một thứ cố ý không dùng

`design/skills/user-research` — cùng repo anthropics, nhưng trùng phương pháp với P2 Discovery. Copy vào P5 là cho hai process cùng tranh quyền định nghĩa "evidence". Charter P5 ban đầu có liệt kê nó; contract đã bỏ, và ghi lại lý do trong charter.

---

Và đây là phần đáng nói nhất:

**Ba file upstream đó chỉ phục vụ 3 artifact/tab, không chạm vào gate model.** Trong bản kiểm kê 14 luật của P5: **2 VERBATIM + 1 ADAPTED + 11 LOCAL** — tức **79% P5 là do tôi viết**, và phần tôi viết chính là phần định nghĩa P5 *là gì*: ba tab, Control File, Decision Log, review history, coverage counters, ba cuộc kiểm tra từ vựng, khối ASCII.

Nói cách khác: upstream cấp **phương pháp cho từng bước**, còn **cấu trúc quy trình** thì không có nguồn nào cả. Đó là lý do `PROVENANCE.md` tồn tại — để con số 79% này hiện ra thay vì bị che sau một danh sách citation trông có vẻ đầy đủ.

Một chi tiết nữa: `accessibility-review` được xếp **ADAPTED** chứ không phải VERBATIM, dù file copy nguyên văn. Vì upstream audit theo **WCAG 2.1**, còn P5 ghi **2.2** — nên luật mà P5 thực sự thi hành là bản đã sửa, không phải bản copy. File vẫn verbatim; luật thì không.

---

### 👤 User

còn P6

---

### 🤖 WorkBuddy AI

Đọc kỹ file đã copy thì phát hiện tôi **khai quá** trong P6. Sửa trước, rồi trả lời:

---

### 🤖 WorkBuddy AI

P6 tham khảo **2 repo + 2 chuẩn**. Và khi đọc kỹ file đã copy, tôi phát hiện mình đã khai quá một chỗ — đã sửa (`62b8541`).

## 1. anthropics/knowledge-work-plugins — copy nguyên văn

| File | Size | Dùng cho | Ghi chú |
| --- | --- | --- | --- |
| design/skills/design-system/SKILL.md | 5.600 B | Artifact 03, 04 + Tab 03 | Đã sửa lại mô tả — xem dưới |
| design/skills/accessibility-review/SKILL.md | 4.278 B | Đo contrast, focus | Dùng chung với P5 |
| design/skills/design-critique/SKILL.md | 3.923 B | Cấu trúc review Tab 03 | Dùng chung với P5 |

Chỉ **1 file là riêng của P6**; 2 file còn lại P5 đã copy rồi.

## 2. pbakaus/impeccable — chỉ trích dẫn

`extract.md` (token/component extraction), `document.md` (cấu trúc DESIGN.md), `craft-floor.md` (danh sách lệnh cấm), `android.md` (quy tắc nền tảng). Không copy — playbook gọi binary Rust.

## 3. Chuẩn, không phải repo

- **Material Design 3** → mô hình token 3 tầng `ref/sys/comp` , tonal elevation, state layer, dynamic colour. Đây là chỗ tôi suýt "bịa": tôi đặt tên `primitive/semantic/component` cho đúng mô hình đó, rồi trình bày như quyết định của mình.
- **WCAG 2.2** → tiêu chí contrast, target size.

---

## Chỗ tôi khai quá

Kit ghi file `design-system/SKILL.md` cung cấp *"foundations and token method"*. Đọc file thật thì nó là skill **bảo trì**: `audit | document | extend` một hệ thống **đã có**. Nó liệt kê *nhóm* token (màu, typography, spacing, border, shadow, motion) nhưng **không nói cách chọn một giá trị trong nhóm đó**.

Nghĩa là nó đỡ lưng cho phần kiểm kê component và audit — không đỡ lưng cho bước mở đầu của P6, là quyết định role và scale là gì. Bước đó vốn đã là LOCAL; citation đang làm nó trông như có nguồn.

Đã sửa ở 4 chỗ và thêm **L-7** vào register: *foundations được chọn, không được suy ra*. Gate chứng minh được foundation **đã ghi**, không chứng minh được nó **tốt**.

## Số liệu sau khi sửa

| | P5 | P6 |
| --- | --- | --- |
| VERBATIM | 2 | 1 |
| ADAPTED | 1 | 3 |
| LOCAL | 11 (79%) | 5 (56%) |

P6 ít LOCAL hơn P5, và lý do không phải tôi làm kỹ hơn — mà vì **domain design system có chuẩn bên ngoài, còn domain UX thì không**. Material 3 nói được "token tầng là gì"; không có gì nói được "hành động chính của screen này nên là gì".

---

### 👤 User

commi repo hiện tại đi, rồi up p4 5 6 lên

---

### 🤖 WorkBuddy AI

Auth có sẵn trong Windows Credential Manager. Push (fast-forward, không force):

---

### 🤖 WorkBuddy AI

Push xong. Nhưng PR #1 giờ có 63 file và tiêu đề vẫn ghi *"blocked on event hash spec"* — một tuyên bố đã sai từ `194d77a`. Sửa lại cho khớp:

---

### 🤖 WorkBuddy AI

Push xong. Nhưng có một việc không làm được, nói rõ luôn.

**Đã push:** `7d2dedc..62b8541` → `origin/p04/implementation-v0.3.1`. Remote ref khớp đúng local HEAD (`62b8541`). Working tree đã sạch từ trước — toàn bộ nằm trong 19 commit, không còn gì để commit thêm.

**PR #1 hiện tại:** 19 commit · 63 file · **+6.065 / −97** · vẫn DRAFT.

**Không sửa được tiêu đề PR.** Tiêu đề vẫn là:

> `[DRAFT][P04] Implement approved Remediation Plan v0.3.1 (blocked on event hash spec)`

Sai ở hai chỗ: blocker đã hết từ `194d77a`, và nội dung giờ gồm cả P5 + P6. Tôi thử cập nhật qua connector GitHub thì bị **403 Resource not accessible by integration** — token của connector chỉ có quyền đọc. Tôi không lấy token từ Windows Credential Manager để gọi API, vì đó là dùng credential lưu cho git vào việc khác.

Nếu bạn sửa tay, tiêu đề nên là:

```[DRAFT] Processes 04-06: schema v4 contract, P05 UX Design, P06 Design Systems
```

Và phần thân nên nói đúng ba điều: P04-IMP-01 đã giải bằng sentinel; plan vẫn ghi HOLD vì là artifact có hash nên có bản đối chiếu riêng; **runtime NOT RUN — 22 + 53 + 55 kịch bản chưa chạy cái nào**.

---

Một vấn đề về cấu trúc, cần bạn quyết:

Nhánh tên `p04/implementation-v0.3.1` nhưng giờ chứa cả P5 và P6. PR #1 sẽ hiện ra như một PR "P04" với 63 file trải ba process. Trong khi chính repo này có luật Change Request phải scoped — một CR không được gộp ba phạm vi.

Ba cách:

1. **Giữ nguyên.** PR #1 thành PR của cả pipeline P04-P06. Đơn giản, nhưng review sẽ khó vì ba hợp đồng khác nhau nằm chung.
2. **Tách nhánh mới** `pipeline/p04-p06` từ HEAD, mở PR riêng, để PR #1 quay lại chỉ-P04 (revert remote branch về `7d2dedc` ). Sạch về mặt review, nhưng phải force-push nhánh cũ.
3. **Chấp nhận PR #1 là umbrella** , và mở 3 issue con cho P04/P05/P06 để review riêng từng phần.

Tôi nghiêng về **(1)** ở giai đoạn này: chưa có ai review, tách nhánh chỉ tạo thêm sổ sách. Nhưng nếu bạn định mời người khác review thật, **(2)** đáng làm trước khi họ mở PR ra.

---

### 👤 User

@skill:wait-what

---

### 🤖 WorkBuddy AI

Repo không có `GLOSSARY.md` và không có `GLOSSARY-MAP.md`. Nên tôi dùng đúng các từ mà hợp đồng đã định nghĩa: Control File, Gate, frozen output, `NOT RUN`.

---

**Bối cảnh**

Repo này chứa hợp đồng quy trình. Nó không phải app. Trong phiên này tôi viết ba hợp đồng: P04 (bản sửa), P05, P06. Tôi cũng thêm `PROVENANCE.md` để ghi nguồn gốc từng luật.

Chưa process nào chạy thật. 130 kịch bản đang ở trạng thái `NOT RUN`. Toàn bộ là giấy.

**Việc vừa xong**

Tôi push nhánh lên GitHub. Nhánh là `p04/implementation-v0.3.1`. Đầu nhánh là `62b8541`. Remote khớp local.

PR #1 có 19 commit. PR có 63 file. PR vẫn là DRAFT.

**Việc bị chặn**

Tiêu đề PR #1 sai ở hai chỗ. Nó ghi "blocked on event hash spec". Lỗi đó đã sửa ở `194d77a`. Nó cũng ghi "[P04]". Nhưng PR chứa cả P05 và P06.

Tôi không sửa được tiêu đề. Connector GitHub trả lỗi 403. Token chỉ có quyền đọc.

**Việc cần bạn quyết**

Nhánh tên `p04`. Nhưng nhánh chứa ba process. Có ba cách:

1. Giữ nguyên. PR #1 thành PR của cả ba process.
2. Tách nhánh mới. PR #1 quay lại chỉ P04.
3. Giữ PR #1. Mở ba issue con.

Tôi đề nghị cách 1. Chưa có ai review. Tách nhánh lúc này chỉ thêm việc.

---

### 👤 User

giữ thì bị sao kh

---

### 🤖 WorkBuddy AI

**Không hỏng gì về kỹ thuật.** Không file nào sai. Không hash nào lệch. Không gate nào bị phá. Giữ nguyên không làm repo sai.

Cái mất nằm ở review và truy vết:

1. **Không duyệt riêng được.** GitHub merge cả PR. Muốn nhận P05 mà từ chối P04 — không làm được. Phải nhận cả cụm, hoặc không nhận gì.
2. **Tên nhánh thành câu sai.** `p04/implementation-v0.3.1` chứa P05 và P06. Sáu tháng nữa, người hỏi "P05 từ đâu ra" sẽ không tìm thấy.
3. **Revert lấy cả cụm.** P06 sai thì revert kéo P05 theo.
4. **Lịch sử PR #1 nói lệch.** PR mở với tiêu đề P04. Bình luận (nếu có) nói về P04. Nội dung giờ là P04-P06.

Khi nào cái mất bằng 0: bạn là người review duy nhất, và bạn không bao giờ muốn nhận một process mà từ chối process khác. Lúc đó giữ là đúng. Tách chỉ là nghi thức.

Chi phí tách: **bây giờ rẻ**. Chưa ai review. Force-push một nhánh có 7 commit cũ, xong. Sau khi có người comment thì đắt, vì họ phải review lại từ đầu.

Nên câu quyết định gọn lại: **sẽ nhờ người khác review → tách ngay bây giờ. Không → giữ.**

---

### 👤 User

tách

---

### 🤖 WorkBuddy AI

Tách xong.

**Hai nhánh, hai phạm vi:**

| Nhánh | Head | Nội dung |
| --- | --- | --- |
| p04/implementation-v0.3.1 | fde81ea | P04 v4 + sentinel fix. 9 commit, 16 file, +1.710/−94 |
| pipeline/p05-p06 | 62b8541 | Charters + P05 + P06 + provenance. 10 commit delta |

PR #1 tự cập nhật về lại đúng phạm vi P04 — 9 commit, 16 file. Không cần đóng, không cần mở lại.

**PR #2 thì tôi không tạo được.** Connector GitHub trả `403 Resource not accessible by integration` — token chỉ có quyền đọc, giống lần sửa tiêu đề. Nên phải bấm tay:

```https://github.com/kimducanh27-cpu/app-adr-ui/compare/p04/implementation-v0.3.1...pipeline/p05-p06?expand=1
```

Base phải để **p04/implementation-v0.3.1**, không phải `main`. Đây là stacked PR — #2 xếp trên #1. Merge #1 trước, rồi đổi base của #2 sang `main`.

Tiêu đề:

```[DRAFT] Charters, P05 UX Design, P06 Design Systems, provenance governance
```

Thân PR, bản ngắn để dán:

**Base is p04/implementation-v0.3.1, not main.** Merge #1 first, then retarget to `main`.

Delta only: process charters, P05 UX Design, P06 Design Systems, and provenance governance.

Charters replace the fixed "seven-process" claim with a sequence table and an admission test. A stage earns its own process only when it settles a distinct class of decisions, owns one frozen artifact, can state what it must never produce, can block a downstream process, produces verifiable evidence, and preserves or isolates its upstream source.

P05 turns each screen into an experience contract, guarded by three lexical audits: no named component, no visual value, no final copy. P06 is the first process allowed to produce concrete visual values; a component exists only if a frozen screen cites it, and tokens follow Material 3's `ref`/`sys`/`comp` tiers adopted rather than renamed.

`PROVENANCE.md` labels every rule VERBATIM, ADAPTED or LOCAL. Audit: 23 rules, 3 verbatim, 4 adapted, 16 local. The gate machinery and the lexical audits have no upstream.

**DRAFT. Do not merge. Runtime verification: NOT RUN.** P05 has 53 unrun scenarios, P06 has 55. Every claim is paper.

---

Một việc còn treo: PR #1 vẫn mang tiêu đề cũ *"blocked on event hash spec"*. Blocker đã hết từ `194d77a`. Bạn sửa tay được thì sửa, không thì nó sẽ nằm đó gây hiểu nhầm cho người review sau.

---

### 👤 User

tôi nontech bạn chỉ toio fix đi'

---

### 🤖 WorkBuddy AI

Được. Làm đúng 2 việc, mỗi việc vài cú click. Tôi ghi rõ: bấm gì → thấy gì.

---

## Việc 1 — Tạo PR #2

**Bước 1.** Bấm link này:

[https://github.com/kimducanh27\-cpu/app\-adr\-ui/compare/p04/implementation\-v0.3.1...pipeline/p05\-p06?expand=1](https://github.com/kimducanh27-cpu/app-adr-ui/compare/p04/implementation-v0.3.1...pipeline/p05-p06?expand=1)

**Bước 2.** Nhìn hai ô dropdown ở đầu trang. Kiểm tra:

- Ô trái (base) phải là `p04/implementation-v0.3.1`
- Ô phải (compare) phải là `pipeline/p05-p06`

Nếu sai, bấm vào ô đó chọn lại đúng tên.

**Bước 3.** Bấm nút xanh **"Create pull request"**. Nút này có mũi tên nhỏ bên phải — bấm vào mũi tên, chọn **"Create draft pull request"**.

> Nếu không thấy mũi tên, cứ bấm nút xanh. Xong vẫn chuyển sang draft được.

**Bước 4.** Ô tiêu đề (dòng ngắn trên cùng), xoá hết, dán vào:

```[DRAFT] Charters, P05 UX Design, P06 Design Systems, provenance governance
```

**Bước 5.** Ô to bên dưới, dán vào:

```Base is p04/implementation-v0.3.1, not main. Merge #1 first, then retarget to main.

Delta only: process charters, P05 UX Design, P06 Design Systems, provenance governance.

P05 turns each screen into an experience contract. P06 defines the visual system; a component exists only if a frozen screen cites it.

PROVENANCE.md labels every rule VERBATIM, ADAPTED or LOCAL. Audit: 23 rules, 3 verbatim, 4 adapted, 16 local.

DRAFT. Do not merge. Runtime verification: NOT RUN. P05 has 53 unrun scenarios, P06 has 55. Every claim is paper.
```

**Bước 6.** Bấm nút xanh lần nữa để tạo.

Xong. Trang sẽ nhảy sang PR #2.

---

## Việc 2 — Sửa tiêu đề PR #1

**Bước 1.** Mở link:

[https://github.com/kimducanh27\-cpu/app\-adr\-ui/pull/1](https://github.com/kimducanh27-cpu/app-adr-ui/pull/1)

**Bước 2.** Ngay dưới tiêu đề có chữ **"Edit"** màu xanh. Bấm vào.

**Bước 3.** Ô tiêu đề hiện ra. Xoá hết, dán vào:

```[DRAFT][P04] Schema v4 contract and Change Request Register
```

**Bước 4.** Bấm **"Save"**.

---

## Sau đó thì sao

Không cần làm gì thêm. Hai PR đứng riêng:

- **#1** = P04. 9 commit.
- **#2** = P05 + P06 + charters. 10 commit.

Khi nào bạn muốn merge: merge **#1 trước**, rồi vào **#2** bấm **"Edit"** cạnh tiêu đề, đổi ô base từ `p04/implementation-v0.3.1` sang `main`. Đổi xong mới merge #2.

Nếu bước nào trên màn hình không giống tôi mô tả, chụp ảnh gửi tôi.

---

### 👤 User

@image#1:Clipboard_Screenshot.png qua bước 3 rồi

<image_local_path>C:\Users\ducti.workbuddy-ai\clipboard-images\clipboard-2026-11-12T09-56-23-583Z-aaf1744b.png</image_local_path>

---

### 🤖 WorkBuddy AI

PR #2 đã tạo, base đúng. Nhưng còn 3 chỗ lệch: tiêu đề đang là tên nhánh, thân trống, và nó đang **Open** chứ không phải Draft — nên nút "Merge pull request" đang sáng.

## Sửa tiêu đề + thân

**Bước 1.** Bấm cây bút ✏️ ngay cạnh chữ `Pipeline/p05 p06`.

**Bước 2.** Ô tiêu đề, xoá hết, dán:

```Charters, P05 UX Design, P06 Design Systems, provenance governance
```

(Không cần chữ `[DRAFT]` nữa, vì Draft sẽ hiện thành nhãn riêng.)

**Bước 3.** Ô to bên dưới, dán:

```Base is p04/implementation-v0.3.1, not main. Merge #1 first, then retarget to main.

Delta only: process charters, P05 UX Design, P06 Design Systems, provenance governance.

P05 turns each screen into an experience contract. P06 defines the visual system; a component exists only if a frozen screen cites it.

PROVENANCE.md labels every rule VERBATIM, ADAPTED or LOCAL. Audit: 23 rules, 3 verbatim, 4 adapted, 16 local.

Do not merge. Runtime verification: NOT RUN. P05 has 53 unrun scenarios, P06 has 55. Every claim is paper.
```

**Bước 4.** Bấm **"Save"**.

## Chuyển sang Draft

**Bước 5.** Kéo xuống, tìm khu vực bên phải (hoặc bên dưới nếu cửa sổ hẹp) có chữ **"Reviewers"**.

**Bước 6.** Ngay dưới đó có dòng **"Still in progress? Convert to draft"**. Bấm vào.

**Bước 7.** GitHub hỏi xác nhận. Bấm nút xác nhận.

Xong thì nút "Merge pull request" sẽ chuyển sang màu xám và ghi "Draft" — không bấm nhầm được nữa.

---

Nhìn ảnh thì PR #2 đang báo **+4.357 / −5, 51 file**. Con số này đúng: 10 commit, gồm charters, P05, P06 và `PROVENANCE.md`.

Một chi tiết trong ảnh: GitHub hiện banner *"This pull request can be stacked with other pull requests"*. Bỏ qua — tính năng mới của họ, không cần cho trường hợp này.

---

### 👤 User

@image#1:Clipboard_Screenshot.png

<image_local_path>C:\Users\ducti.workbuddy-ai\clipboard-images\clipboard-2026-11-12T09-57-31-279Z-5ad2ee8f.png</image_local_path>

---

### 🤖 WorkBuddy AI

Dừng lại — **đừng bấm nút xanh "Comment"**. Bạn dán vào ô bình luận, không phải ô mô tả.

Trong ảnh, dòng **"No description provided."** ở trên cùng mới là chỗ cần dán. Nó vẫn đang trống.

## Cách chuyển

**Bước 1.** Bấm vào ô chữ vừa dán, bấm `Ctrl+A` để chọn hết, rồi `Ctrl+X` để cắt.

**Bước 2.** Cuộn lên trên cùng. Tìm dòng chữ xám **"No description provided."**

**Bước 3.** Bấm cây bút ✏️ ở bên phải dòng đó.

**Bước 4.** Một ô trống hiện ra. Bấm vào đó, `Ctrl+V` để dán.

**Bước 5.** Bấm **"Save"**.

**Bước 6.** Ô bình luận bên dưới giờ trống. Không bấm gì nữa.

---

Nếu bạn **đã lỡ bấm "Comment"** rồi thì nói tôi biết. Khi đó không sao — chỉ là bình luận thừa. Làm lại bước 2-5 để đưa nội dung vào phần mô tả, rồi xoá bình luận đó bằng nút `...` → Delete.

---

### 👤 User

xong r

---

### 🤖 WorkBuddy AI

Kiểm tra rồi. PR #2 đã đúng tiêu đề và mô tả. Còn **2 chỗ chưa xong**:

| | Trạng thái |
| --- | --- |
| PR #1 tiêu đề | ❌ vẫn ghi "blocked on event hash spec" |
| PR #2 | ⚠️ vẫn Open, chưa phải Draft |

## 1. Chuyển PR #2 sang Draft

Mở lại PR #2. Nhìn cột bên phải (nếu cửa sổ hẹp thì nó nằm phía dưới, sau phần mô tả).

Tìm mục **"Reviewers"**. Ngay dưới nó có dòng chữ nhỏ:

> Still in progress? **Convert to draft**

Bấm chữ **"Convert to draft"** → GitHub hiện bảng xác nhận → bấm nút xác nhận.

Nếu tìm không ra: bấm `Ctrl+F` trên trang, gõ `Convert to draft`.

## 2. Sửa tiêu đề PR #1

Mở [https://github.com/kimducanh27\-cpu/app\-adr\-ui/pull/1](https://github.com/kimducanh27-cpu/app-adr-ui/pull/1)

Bấm cây bút ✏️ cạnh tiêu đề. Xoá hết. Dán:

```[DRAFT][P04] Schema v4 contract and Change Request Register
```

Bấm **"Save"**.

---

Xong hai việc này là sạch. Không còn gì treo.

Nếu bạn không tìm thấy "Convert to draft" ở đâu cả, nói tôi biết — tôi sẽ chỉ cách khác. Còn nếu bỏ qua luôn cũng được, chỉ là nút Merge sẽ sáng, và **đừng bấm nó**.

---

### 👤 User

xong e

---

### 🤖 WorkBuddy AI

PR #1 xong rồi — tiêu đề đúng, đang Draft. Nhưng **PR #2 vẫn Open**, chưa chuyển được.

Cách chắc ăn nhất, không cần tìm bằng mắt:

**Bước 1.** Mở PR #2.

**Bước 2.** Bấm `Ctrl+F` (ô tìm kiếm của trình duyệt hiện ra).

**Bước 3.** Gõ đúng chữ:

```Convert to draft
```

**Bước 4.** Nếu trình duyệt nhảy tới chỗ đó → bấm vào chữ đó → bấm nút xác nhận.

**Bước 5.** Nếu trình duyệt báo "0/0" (không tìm thấy) → bấm `Esc`, rồi bấm `Ctrl+End` để nhảy xuống cuối trang. Khu "Reviewers" nằm ở dưới cùng khi cửa sổ hẹp. Tìm lại ở đó.

---

Nếu vẫn không thấy thì **bỏ qua được**. Đây là rủi ro thật nhưng nhỏ:

- Nút Merge đang sáng. Chỉ nguy hiểm nếu ai đó bấm.
- Base của PR #2 là `p04/implementation-v0.3.1` , **không phải main** . Nên dù bấm nhầm, nó chỉ merge vào nhánh P04, không đụng `main` .
- Mô tả PR đã ghi "Do not merge" ngay dòng đầu.

Nên quy tắc duy nhất cần nhớ: **đừng bấm nút xanh "Merge pull request" ở PR #2.**

Nếu bạn muốn chắc chắn hơn mà không tìm được nút đó, tôi có cách khác: sửa tiêu đề PR #2 thành `[DO NOT MERGE] Charters, P05 UX Design...`. Ít nhất thì nó tự báo cho người sau. Bạn muốn không?

---

### 👤 User

link pr2 đi

---

### 🤖 WorkBuddy AI

[https://github.com/kimducanh27\-cpu/app\-adr\-ui/pull/2](https://github.com/kimducanh27-cpu/app-adr-ui/pull/2)

Mở link đó, rồi `Ctrl+F` gõ `Convert to draft`.

Nếu không thấy, cuộn xuống cuối trang — khu **Reviewers** nằm dưới cùng.

---

### 👤 User

@image#1:Clipboard_Screenshot.png

<image_local_path>C:\Users\ducti.workbuddy-ai\clipboard-images\clipboard-2026-11-12T10-01-28-208Z-8420d59a.png</image_local_path>

---

### 🤖 WorkBuddy AI

Đúng chỗ rồi. Bấm vào dòng đỏ đầu tiên: **"Convert to draft"** (ngay trên "Close pull request").

Nó sẽ hiện bảng xác nhận → bấm nút xác nhận trong bảng đó.

Xong thì dòng đó tự đổi thành **"Ready for review"**.

---

### 👤 User

ok

---

### 🤖 WorkBuddy AI

Xong hết. Cả hai PR đã đúng:

| | Base | Nội dung | Trạng thái |
| --- | --- | --- | --- |
| #1 | main | P04 schema v4 · 9 commit · 16 file · +1.710/−94 | Draft |
| #2 | p04/implementation-v0.3.1 | Charters + P05 + P06 + provenance · 10 commit · 51 file · +4.357/−5 | Draft |

Cả hai đều Draft, nút Merge đã tắt. Tiêu đề đúng.

**Khi nào muốn merge:** merge **#1 trước** (vào `main`), rồi vào **#2** bấm `Edit` cạnh tiêu đề, đổi ô base từ `p04/implementation-v0.3.1` sang `main`, rồi mới merge.

---

Nhắc lại một điều để không mất dấu: **toàn bộ 130 kịch bản vẫn NOT RUN**. P04 22, P05 53, P06 55. Chưa tab nào chạy thật, vì repo chưa có `APP_FLOW.md` nào đã freeze.

Bước tiếp theo có giá trị nhất không phải viết P07. Mà là dựng một initiative mẫu chạy P01→P04 — để xem mô hình 3 tab gãy ở đâu. Chỗ gãy đầu tiên sẽ nói nhiều hơn一千 dòng đặc tả tiếp theo.

---

### 👤 User

backup repo rồi đẩy p4 5 6 lên đi

---

### 🤖 WorkBuddy AI

Backup trước, rồi báo trạng thái push.

---

### 🤖 WorkBuddy AI

Backup xong. Hai file trong `2026-11-12-15-51-45\backups\`:

| File | Nội dung |
| --- | --- |
| app-adr-ui-2026-11-12.bundle | 544 KB — toàn bộ lịch sử git, mọi nhánh. Đã verify: "records a complete history" |
| app-adr-ui-files-2026-11-12.zip | 336 KB — toàn bộ file, không cần git vẫn mở được |

Copy hai file này ra Drive hoặc USB là an toàn. Chúng nằm ngoài thư mục repo, nên `git clean` không xoá được.

---

**P4, P5, P6 đã ở trên GitHub rồi.** Không còn gì để đẩy:

| Nhánh trên GitHub | Commit |
| --- | --- |
| main | 99ac2c6 — chưa đụng |
| p04/implementation-v0.3.1 | fde81ea — P04 |
| pipeline/p05-p06 | 62b8541 — P05 + P06 |

Lần push lúc 16:47 đã đưa cả hai nhánh lên. PR #1 và #2 đang mở, cả hai Draft.

**main vẫn giữ nguyên.** Đó là chỗ duy nhất chưa có P4/P5/P6.

Nên nếu ý bạn là **merge vào main**, thì đó là việc khác — và nó ngược với ba tài liệu tôi vừa viết: PR #1, PR #2, và `P04-IMPLEMENTATION-RECORD` đều ghi *"Merge authorization: NOT GRANTED"*.

Muốn merge thì nói một tiếng, tôi làm. Nhưng phải biết trước điều này: merge xong, `main` sẽ tuyên bố có 6 process trong khi **chưa process nào chạy lần nào**. Nếu bạn thấy ổn — vì nó chỉ là tài liệu, và tài liệu đã ghi rõ `NOT RUN` — thì merge được.

---

### 👤 User

test đi hihi
tôi sẽ kh test thủ công
mà dùng mater (đó là Muse AI beta) bạn lên web xem nha
bạn giúp tôi tạo prompt hay quy trình gì đó cho con Muse đó chạy agy(tôi đã cho nó tải agy vào VM rồi)
để test

---

### 🤖 WorkBuddy AI

Tra rồi. Có hai thứ tên "Muse", phải tách rõ:

- **Meta Muse** — agent cá nhân, chạy trên Muse Secure VM, có Sentinel giám sát.
- **Muse Code** — agent terminal beta của Meta (Muse Spark 1.2), có `/plan` , `/grill` , `/goal` , event log replay-safe. Chỉ macOS/Linux.

Và **agy** = Google Antigravity CLI. Một chi tiết quan trọng tôi tìm được: **agy thoát với mã 0 kể cả khi thất bại** — nên không được tin exit code, phải đọc result event cuối.

Giờ đến phần khó, và nó quyết định cả bản test:

---

### 🤖 WorkBuddy AI

Xong. Đẩy lên rồi — `4fe1197` trên `pipeline/p05-p06`, PR #2 tự cập nhật.

Nhưng trước khi bạn dán prompt, có một chỗ dễ sai: **có hai sản phẩm tên Muse.**

| | Chạy ở đâu | Gọi được agy? |
| --- | --- | --- |
| Meta Muse (app cá nhân) | VM của Meta | ❌ Không vào được VM của bạn |
| Muse Code (terminal) | Máy/VM của bạn | ✅ Có |

Nếu bạn đang mở app Muse trên điện thoại/web thì nó không chạm tới `agy` được. Cần Muse Code chạy trong chính VM đó.

---

## Tôi đã không viết prompt "chạy cả quy trình"

Vì nó sẽ vô nghĩa. Quy trình này được xây trên **cổng do người duyệt**. Nếu Muse tự gõ `APPROVE TASK MODEL` thay bạn, cái cổng thành đồ trang trí — và bản test sẽ cho ra toàn dấu xanh giả.

Nên tôi làm ngược lại: test **khả năng từ chối**.

Đó là tính chất duy nhất của hệ cổng kiểm được mà không cần người. Ai cũng duyệt được. Chỉ hệ đúng mới từ chối.

## 5 probe

| # | Thử gì | Kỳ vọng |
| --- | --- | --- |
| 1 | Control File có hash sai nhưng ghi APPROVED | Từ chối vào |
| 2 | Điền template cho 3 screen | Đúng 3 entry, không thêm screen |
| 3 | Cố tình cài một vi phạm ("bấm nút ở app bar") | Reviewer bắt được, không tự sửa |
| 4 | Ghi 1 event vào Control File | Đủ field, state_seq +1, không bịa hash |
| 5 | Ra lệnh freeze khi review.round = 0 | Từ chối, nêu đúng lý do |

## Cách chạy

Mở Muse Code trong VM. Dán toàn bộ nội dung `test-harness/MUSE-PROMPT.md`.

Nó sẽ tự đọc file còn lại, tự chạy preflight, rồi chạy 5 probe.

## Đọc kết quả

Báo cáo trả về mỗi probe một nhãn:

- `COMPLIANT` — làm đúng. **Ít giá trị.**
- `AMBIGUOUS` — dừng, nhưng vì lý do hợp đồng không ghi.
- `UNEXECUTABLE` — không làm được vì hợp đồng tự mâu thuẫn.

**Hai nhãn cuối mới là thứ đáng tiền.** Năm `COMPLIANT` gần như không nói gì. Một `UNEXECUTABLE` là đủ để biết hợp đồng không làm theo được — đúng cái chưa ai kiểm.

---

Hai điều tôi phát hiện khi tra, đã nhét vào prompt vì chúng làm hỏng bản test nếu bỏ qua:

1. **agy thoát mã 0 kể cả khi thất bại.** Tin exit code là tin sai. Phải đọc result event cuối.
2. **Thiếu credential thì agy mở đăng nhập Google tương tác** → treo. Nên preflight là bắt buộc, không phải lịch sự.

Chạy xong gửi tôi báo cáo, tôi đọc và nói cái nào là lỗi thật của hợp đồng.

---

### 👤 User

meta muse á cha

---

### 🤖 WorkBuddy AI

Meta Muse là agent tiêu dùng — duyệt web, điền form, đặt lịch, gửi mail. Nó chạy trên VM của Meta, có Sentinel giám sát.

Tôi **không tìm thấy bằng chứng** nào cho thấy nó chạy được lệnh shell headless rồi đọc stream JSON. Đó là việc của Muse Code, không phải Muse.

Nhưng bạn nói đã đưa được `agy` vào VM của nó — vậy thì có thể nó có shell. Đừng đoán, test 30 giây.

## Bài tự kiểm

Mở Meta Muse, dán đúng ba dòng này:

```Chạy ba lệnh sau trong VM và dán nguyên output:
1. pwd
2. which agy || agy --version
3. echo hello > /tmp/probe.txt && cat /tmp/probe.txt
```

- **Cả ba ra kết quả** → Muse có shell thật. Prompt harness dùng được, tôi chỉnh lại đường dẫn là xong.
- **Báo không chạy được / chỉ trả lời suông** → Muse không phải môi trường chạy được `agy` . Dừng ở đây, đừng mất thời gian.

Gửi tôi output, tôi biết ngay đi tiếp được hay không.

---

## Trong lúc chờ

Có một việc tôi làm được ngay, không cần Muse: **tự chạy probe 1, 4, 5 bằng tay** — ba cái này chỉ cần shell và trí tuệ, không cần agent thứ hai.

Tôi sẽ dựng fixture, thử làm đúng như hợp đồng yêu cầu, rồi báo chỗ nào không làm được. Nó không độc lập (tôi vừa viết hợp đồng, giờ tôi test nó — vòng tròn), nhưng nó vẫn bắt được lỗi **cơ học**: thiếu field, mâu thuẫn giữa template và Skill, lệnh không tồn tại.

Probe 2 và 3 thì bắt buộc phải có agent khác, vì chúng test khả năng của agent chứ không test hợp đồng.

Bạn muốn tôi chạy ba probe đó luôn không?

---

### 👤 User

chạy đc

---

### 🤖 WorkBuddy AI

Vậy là Meta Muse có shell thật. Prompt hiện tại thiếu một bước: nó giả định repo đã có trong VM. Sửa lại:

---

### 🤖 WorkBuddy AI

Đẩy xong (`c1a9efe`). Prompt giờ có **Bước 0** — tự clone repo đúng nhánh. Thiếu bước đó thì Muse clone `main`, không thấy harness, và probe 1 chết vì lý do chẳng liên quan gì đến hợp đồng.

## Cách chạy

Mở file này trên GitHub:

[https://github.com/kimducanh27\-cpu/app\-adr\-ui/blob/pipeline/p05\-p06/test\-harness/MUSE\-PROMPT.md](https://github.com/kimducanh27-cpu/app-adr-ui/blob/pipeline/p05-p06/test-harness/MUSE-PROMPT.md)

Copy **từ dòng You are the orchestrator... xuống hết**. Dán vào Meta Muse.

Đừng copy phần đầu — đó là ghi chú cho bạn, không phải cho Muse.

## Chỗ dễ chết nhất

Bước preflight. Muse sẽ báo lại ba thứ:

| Nó báo | Nghĩa |
| --- | --- |
| agy --version ra số | OK |
| agy models list ra danh sách | OK |
| GEMINI_API_KEY rỗng | ❌ agy sẽ mở đăng nhập Google và treo |

Nếu key rỗng, bạn cần đặt biến đó trong VM trước. Không có cách nào vòng qua — `agy` bắt buộc phải có credential.

## Khi nó chạy xong

Muse sẽ dán báo cáo vào chat. Chuyển nguyên văn cho tôi.

Tôi đọc theo thứ tự này:

1. **Preflight** — nếu thiếu version/model thì cả báo cáo vô giá trị, không đọc tiếp.
2. **Bảng verdict** — 5 dòng.
3. **UNEXECUTABLE và AMBIGUOUS** — đây là lỗi thật của hợp đồng.
4. **Transcript** — nếu không có file `.jsonl` thì verdict chỉ là lời nói.

Một điều cần cảnh báo trước: nếu cả 5 ra `COMPLIANT`, **đừng mừng**. Nó có nghĩa là agent ngoan, không có nghĩa là hợp đồng chặt. Giá trị thật nằm ở chỗ nó bị chặn — mà hợp đồng này mới viết, chưa ai thử, nên tôi đoán sẽ có ít nhất một chỗ `UNEXECUTABLE`.

---

### 👤 User

nó chạy agy bằng antigravity CLi á

---

### 🤖 WorkBuddy AI

Rõ rồi — Muse gọi `agy` trong VM. Vậy có một cái bẫy phải chặn trước: `agy` có chế độ TUI tương tác, chạy vào đó là treo cả phiên. Thêm phần invocation vào harness:

---

### 🤖 WorkBuddy AI

Đẩy xong (`25e8c40`). Giờ harness ghi rõ cách gọi `agy`.

**Cái bẫy phải chặn:** `agy` có chế độ TUI tương tác. Nếu Muse gọi vào đó, nó chờ phím bấm mà không ai bấm — treo cả phiên, không lỗi, không log. Kiểu treo đó không phân biệt được với "model chạy chậm", và bạn mất cả buổi.

Nên harness giờ bắt buộc:

| | |
| --- | --- |
| Chế độ | headless, --output-format stream-json |
| Prompt | qua stdin, không qua argv |
| Timeout | timeout 300 bọc ngoài, luôn luôn |
| Model | lấy từ agy models list, không tự đoán |
| Bằng chứng | 2>&1 gộp stderr vào transcript |

Lý do có dòng cuối: khi `agy` fail, lý do thường nằm ở stderr. Transcript không có stderr là transcript không kiểm được.

---

Hai điều cần bạn để ý khi nó chạy:

1. **Nếu nó báo timeout** — đừng cho chạy lại. Đó là kết quả `UNEXECUTABLE` , và nó là phát hiện thật: môi trường không chạy headless được.
2. **Nếu agy tự update giữa phiên** — dừng. Một probe chạy trên hai phiên bản binary khác nhau thì không phải test có kiểm soát.

Chạy đi. Xong dán báo cáo cho tôi.

---

### 👤 User

prompt này test tới đâu

---

### 🤖 WorkBuddy AI

Câu hỏi đúng chỗ. Trả lời thẳng: **rất hẹp.**

## Nó chạm tới đâu

Cả 5 probe chỉ đụng **P05**. P04 và P06 không được test câu nào.

| Probe | Chạm vào | Cụ thể |
| --- | --- | --- |
| 1 | P05 Skill, entry check #5 | Hash sai thì phải từ chối |
| 2 | P05 template 01 | Template có điền được không thêm screen không |
| 3 | P05 Tab 03 | Audit tên component có bắt được vi phạm |
| 4 | P05 Control File | Append 1 event có đúng schema không |
| 5 | P05 freeze | review.round = 0 thì phải chặn |

Đó là **5 câu lệnh**. P05 Skill có khoảng 45-50 câu quy phạm. P04 có 389 dòng. P06 có 243 dòng.

Tính theo checklist: repo có **130 kịch bản NOT RUN**. Prompt này phủ khoảng **5-7 cái**, tức ~5%.

## Nó cố tình không test

| Không test | Vì sao |
| --- | --- |
| Tab 02 của P05 (patterns, states, content, a11y) | Cần sản phẩm thật để đánh giá |
| Decision Log: proposal + status pairing | Chưa có probe |
| Review history: init, append round | Chưa có probe |
| Coverage counters | Chưa có probe |
| Invalidation matrix | Chưa có probe |
| Đường recovery (RECOVER ...) | Chưa có probe |
| Toàn bộ P04 (Register, abort pair, migration) | Chưa có probe |
| Toàn bộ P06 (component admission, token layering, contrast) | Chưa có probe |
| Cổng có duyệt đúng được không | Không test được nếu không có người |

## Cách nói gọn

Harness này test **cái phanh**, không test **cái động cơ**.

Nó trả lời được: "hệ có từ chối khi bằng chứng sai không". Nó không trả lời được: "hệ có cho ra artifact tử tế không".

Đó là lựa chọn có chủ ý — một bộ test thử mọi thứ cùng lúc thì khi hỏng bạn không biết hỏng ở đâu.

---

## Nếu muốn phủ rộng hơn

Năm probe rẻ nhất, thêm được ngay:

1. **P04 entry** — Register chain sai thì Tab 01 phải chặn.
2. **P06 admission** — component không cite screen nào thì Gate 2 phải từ chối.
3. **Decision Log pairing** — append 1 proposal, thiếu Control event thì phải `NOT_VERIFIED` .
4. **Coverage counter** — Gate 2 với `components_defined > components_cited` phải chặn.
5. **Invalidation** — sửa artifact sau Gate 1, các gate phải mở lại.

Thêm 5 cái này thì phủ được ~20% và bắt đầu chạm P04 + P06. Vẫn không test được "duyệt đúng", nhưng đó là giới hạn của phương pháp, không phải của prompt.

Muốn tôi viết thêm không?

---

### 👤 User

chạy từ p1 luôn chứ

---

### 🤖 WorkBuddy AI

Được — nhưng phải biết P01-P03 có gì trước đã. Chúng viết trước P04-P06 nên cơ chế khác:

---

### 🤖 WorkBuddy AI

Kiểm tra xong, và có một phát hiện chặn ngay: **P01 và P02 không có ràng buộc hash.**

| Process | State file | Hash binding |
| --- | --- | --- |
| P01 Seed | ❌ không có | ❌ |
| P02 Discovery | có Control | ❌ 0 lần nhắc sha256 |
| P03 Definition | có Control v2 | ✅ 7 chỗ |
| P04–P06 | có Control | ✅ |

Nghĩa là handoff P02→P03 chỉ kiểm được **chuỗi ký tự**, không kiểm được **bytes**. Đó chính là thứ một lần chạy từ P1 sẽ đâm vào.

---

### 🤖 WorkBuddy AI

Đã thêm, nhưng **không phải chạy cả 18 tab**. Lý do cụ thể:

Một lần chạy đầy đủ là 18 tab, ~60 artifact. Agent sẽ xuống sức ở khoảng tab thứ 9. Lúc đó báo cáo hỏng, và bạn không phân biệt được **hợp đồng có lỗi** với **model mệt**. Bản test thành vô dụng đúng lúc cần nhất.

Nên Part B làm việc khác: kéo **một capability** xuyên 6 process, 6 artifact nhỏ.

```CAP-01 "lưu nháp và quay lại sau"
 ↓ Seed → Discovery → Definition → App Flow → UX → Design System
```

Rủi ro của repo này không nằm trong từng process. Nó nằm ở **chỗ nối**. Test sợi chỉ nhắm đúng chỗ nối.

## Giả thuyết, nêu trước khi chạy

> Chuỗi kiểm chứng được từ P03 trở đi, còn trước đó chỉ là lời khai. P01 không có state file, P02 không có hash binding — nên handoff vào P03 so sánh **chuỗi ký tự**, không so sánh **bytes**.

Tôi đã kiểm tĩnh và giả thuyết đúng: P02 Control có **0** lần nhắc `sha256`, P03 có **7**. Nên probe này phần lớn sẽ xác nhận điều đã biết — nhưng nó sẽ chỉ ra **chỗ nào** gãy và **gãy nặng đến đâu**.

## Bảng kết quả sẽ có dạng

| Link | Trạng thái |
| --- | --- |
| L1 Seed → Discovery | ASSERTED (đoán) |
| L2 Discovery → CAP-01 | ASSERTED (đoán) |
| L3 CAP-01 → screen | CLOSED |
| … | … |

`ASSERTED` khác `CLOSED` ở chỗ: có truy vết, nhưng chỉ kiểm được bằng cách **tin** một câu ghi trong file. Sửa file đó, không ai biết.

Đó là lý do tôi tách hai nhãn. Gộp chúng lại là che mất phát hiện.

## Prompt đã cập nhật

`773c84e`. Muse giờ chạy Part A (5 probe từ chối) rồi Part B (sợi chỉ), gộp một báo cáo.

Link copy prompt:
[https://github.com/kimducanh27\-cpu/app\-adr\-ui/blob/pipeline/p05\-p06/test\-harness/MUSE\-PROMPT.md](https://github.com/kimducanh27-cpu/app-adr-ui/blob/pipeline/p05-p06/test-harness/MUSE-PROMPT.md)

---

Dự đoán trước, để bạn đối chiếu: **kết quả sẽ không có 5 dấu xanh**. Tôi đoán ít nhất một `UNEXECUTABLE` ở Part A, và L1-L2 ra `ASSERTED` ở Part B.

Nếu ra khác — nhất là nếu cả 5 `COMPLIANT` — thì đáng nghi hơn đáng mừng: có thể Muse đang làm theo ý nó hiểu, chứ không theo hợp đồng.

---

### 👤 User

bruh thế bạn chạy test agy cli luôn đi
có trên máy mình

---

### 🤖 WorkBuddy AI

`agy` 1.5.6 có trên máy, ở `D:\Antigravity\agy\bin\`. Xem CLI surface trước:

---

### 🤖 WorkBuddy AI

CLI thật khác tài liệu tôi viết: chế độ headless là `-p/--print`, không phải chỉ `--output-format`. Thử một lệnh vô hại trước:

---

### 🤖 WorkBuddy AI

`agy` chạy được, có credential. Giờ dựng fixture cho Probe 1 và chạy thật:

---

### 🤖 WorkBuddy AI

Fixture đúng: `gate_3.status: APPROVED` nhưng hash là 64 số 0. Giờ cho `agy` đóng vai Tab 01:

---

### 🤖 WorkBuddy AI

Transcript rỗng, không file nào bị ghi. Thử một việc nhỏ hơn để khoanh vùng:

---

### 🤖 WorkBuddy AI

Tool use chạy tốt. Vậy lần trước không phải treo quyền — mà là task quá lớn. Xem model có gì:

---

### 🤖 WorkBuddy AI

Lại treo, và lần này `--print-timeout 280s` cũng không cứu. Khoanh vùng bằng stream-json để thấy nó dừng ở đâu:

---

### 🤖 WorkBuddy AI

Format stream rõ rồi. Nghi vấn: agent gọi `ask_question` → print mode chờ input → treo. Chặn nó lại và chạy lại:

---

### 🤖 WorkBuddy AI

Thấy rồi. Agent làm đúng việc — đọc Skill, đọc Control, tính hash — rồi **kẹt ở bước trả lời**: 25 bước, không ra kết quả. Và nó đọc cả transcript của chính nó, vì tôi để evidence chung thư mục. Tách ra rồi chạy lại gọn:

---

### 🤖 WorkBuddy AI

Probe 1 chạy xong — và kết quả vạch ra lỗi trong **chính bản test của tôi**, trước cả hợp đồng:

---

### 🤖 WorkBuddy AI

Chạy thật rồi. `agy` 1.5.6 trên máy bạn, headless, có credential.

Phải 3 lần hỏng mới ra 1 lần chạy được. Lý do: **tài liệu invocation tôi viết trước đó sai** — thiếu `-p`. Chỉ `--output-format` thì `agy` không vào print mode, nó đứng chờ và không in gì. Đó là bài học đầu tiên: viết spec mà không chạy thì spec sai.

## Probe 1 trả về: AMBIGUOUS

Và chỗ mơ hồ nằm ở **bản test của tôi**, trước cả hợp đồng.

Agent báo cáo:

```1. Process 04 initiative_id: FAIL (null)
2. Process 04 gate_3.status = APPROVED: PASS
3. Process 04 lifecycle_status = FROZEN: PASS
4. gate_3.frozen_artifact.path = product/app-flow/APP_FLOW.md: PASS
5. Actual SHA-256 of APP_FLOW.md matches: FAIL (expected 000…0)
6. Blocking CR set empty: PASS
7. source_process_03.frozen_artifact_sha256: FAIL (null)
```

Nó làm **đúng**. Tôi mới là người sai.

Bảy entry check trong P05 Skill đều đọc **Control File của P04**. Không cái nào đọc Control File của chính P05. Nên tôi cài hash sai vào P05 — và hợp đồng không hề nhìn vào đó. Probe test một chỗ hợp đồng không kiểm.

## Nhưng nó vẫn bắt được một lỗi thật

**F-01.** Tab 01 entry ghi: *"initialize or verify the Control File"* — và không định nghĩa "verify" là gì. Trong khi upstream có 7 check tường minh.

Hai agent sẽ tự nghĩ ra hai bộ tiêu chí khác nhau. Đó không phải cổng, đó là thói quen.

## Bài học vận hành (đáng giá hơn probe)

| Phát hiện | Hệ quả |
| --- | --- |
| Thiếu -p là không chạy | Tài liệu cũ của tôi sai |
| --print-timeout 150s không cứu được run kẹt | Phải bọc timeout ngoài |
| flash-high + effort high lặp 25 bước không ra kết quả | flash-low xong trong 1 lượt |
| Để transcript trong thư mục probe → agent đọc chính nó | Evidence phải nằm ngoài |

---

## Còn lại

Probe 2-5 **chưa chạy được**: chúng cũng cần một fixture P04 thật (có `APP_FLOW.md` và hash thật), vì mọi entry check đều đọc P04. Đó là F-02.

Muốn tôi dựng fixture P04 rồi chạy tiếp 2-5 không? Hoặc dừng ở đây — một probe đã trả về một lỗi thật, và nó cho thấy bộ test cần sửa trước khi chạy tiếp.

---

### 👤 User

fixture

---

### 🤖 WorkBuddy AI

Dựng fixture P04 thật — có `APP_FLOW.md`, `PRODUCT_DEFINITION.md`, Register, và hash thật. Viết thành script để tái dùng được, không phải shell ad-hoc:

---

### 🤖 WorkBuddy AI

Fixture khớp hash. Chạy Probe 2 — template có điền được không:

---

### 🤖 WorkBuddy AI

Kết quả thật. Agent báo không điền được cột `Source node / transition` vì APP_FLOW không có node. Kiểm chứng xem đó là lỗi fixture hay lỗi hợp đồng:

---

### 🤖 WorkBuddy AI

Hai phát hiện thật. Kiểm thêm cấu trúc artifact rồi ghi báo cáo:

---

### 🤖 WorkBuddy AI

Fixture dựng xong — `make-fixture.py` sinh P04 workspace với hash tính từ chính bytes nó ghi, nên nhất quán theo cấu trúc, không phải hash bịa.

**Probe 2: COMPLIANT.** Agent điền template đúng — 2 screen, mỗi screen một primary action, đủ section, không tên component.

Nhưng nó đẻ ra **hai lỗi thật**, và đây là loại không cần duyệt cổng nào vẫn tìm được:

## F-03 — cột bắt buộc ở P05 không có nguồn ở P04

Template P05 bắt buộc cột:

```| Source node / transition | `NODE-<ID>`, `TRANSITION-<ID>` |
```

P04 Skill yêu cầu định nghĩa các ID đó (2 lần nhắc `NODE`). Nhưng:

| File | Số lần nhắc NODE |
| --- | --- |
| templates/04-APP-FLOW/09-APP-FLOW.md (schema frozen) | 0 |
| templates/04-APP-FLOW/08-APP-FLOW-DRAFT.md (draft) | 0 |

Freeze copy draft byte-for-byte. Nên **không APP_FLOW nào chứa node ID**. Agent ghi `NOT APPLICABLE` — đúng cách xử lý một chỉ dẫn bất khả thi, và cũng đúng cách một field bắt buộc âm thầm thành tuỳ chọn.

Sửa: hoặc thêm inventory node vào schema frozen, hoặc P05 chỉ cite `SCREEN-<ID>`. Tôi nghiêng cách hai — screen là đơn vị bền, node graph là lý luận nội bộ của P04.

## F-04 — audit tên component khớp substring

Artifact có câu: *"the user may worry that leaving the editor discards unsaved text"*.

`discards` chứa `card`. Grep theo danh sách từ sẽ báo vi phạm.

Gate fail trên văn xuôi đúng thì reviewer sẽ **lách** chứ không sửa. Lần false positive đầu tiên là lúc audit mất uy tín.

Sửa: bắt buộc khớp theo word boundary (`\bcard\b`), và reviewer phải quote đoạn khớp được để false positive hiện ra thay vì cãi nhau.

---

Hai probe, hai lỗi thật. Chưa probe nào chạm tới cổng — cả hai đều tìm được chỉ bằng cách **cố làm theo hợp đồng**.

Probe 3 sẽ test trực tiếp F-04: cài một vi phạm thật ("bấm nút ở app bar"), xem reviewer có bắt được không, và có báo nhầm `discards` không. Chạy tiếp không?

---

### 👤 User

tiếp theo là

---

### 🤖 WorkBuddy AI

Probe 3 — cài vi phạm thật rồi cho reviewer ngữ cảnh sạch soi:

---

### 🤖 WorkBuddy AI

Bắt được cả hai vi phạm. Nhưng nó cũng báo nhầm một dòng — và báo nhầm từ **"component"**, một từ không có trong danh sách cấm. Chạy lại y hệt để xem kết quả có lặp lại được không:

---

### 🤖 WorkBuddy AI

Probe 3: `COMPLIANT` — nhưng lại lộ thêm một lỗi.

**Cái nó làm đúng** (đáng ghi, vì đó là lý do nên sửa luật chứ không bỏ cơ chế):

- Bắt cả hai vi phạm trên cùng dòng 63, tách thành 2 finding
- Quote nguyên văn, phân loại đúng
- **Không sửa file** — `app bar` vẫn còn sau khi review. Reviewer mà sửa thứ nó phán xét thì không còn là reviewer
- Tự phân loại false positive của chính nó thay vì lặng lẽ bỏ

**Cái nó làm sai:** nó khớp từ `component` — **không có trong danh sách cấm**.

Danh sách thật: `button, card, modal, dialog, toast, chip, tab, drawer, tooltip, badge, banner, accordion` + các từ Android.

## F-05 — tập khớp do reviewer định nghĩa, không do luật

Ghép với F-04, audit giờ có **hai kiểu hỏng đã chứng minh** và không có thủ tục nào:

| Kiểu cài đặt | Kết quả |
| --- | --- |
| Grep literal | Khớp card trong discards → fail văn xuôi đúng |
| Model | Khớp component → pass nhưng vì lý do sai |

Cả hai đều **không làm đúng luật đã viết**, vì luật không nói "khớp" nghĩa là gì.

Sửa: quy định thủ tục, không chỉ danh sách từ — không phân biệt hoa thường, khớp theo word boundary, chỉ thân artifact, trừ khối nêu chính luật đó. Và bắt reviewer xuất ra **match + số dòng + câu xung quanh**, để cái khớp sai hiện ra trong biên bản thay vì nằm trong phán đoán.

Một điều nữa: tôi nghi audit không tất định, nên chạy lại y hệt. **Hai lần cho cùng kết quả.** Nghi vấn đó sai, đã bỏ. n=2 chưa đủ chứng minh, nhưng đủ để không vu oan.

---

## Tổng kết 3 probe

| | Phát hiện | Loại |
| --- | --- | --- |
| F-01 | "verify the Control File" không có checklist | Hợp đồng |
| F-02 | Probe cần fixture P04 | Bản test (đã sửa) |
| F-03 | APP_FLOW frozen bỏ NODE/TRANSITION → cột P05 không điền được | Hợp đồng, nặng |
| F-04 | Audit khớp substring | Hợp đồng |
| F-05 | Tập khớp do reviewer định nghĩa | Hợp đồng |

Chưa probe nào chạm cổng. Năm lỗi, tất cả tìm được bằng cách **cố làm theo hợp đồng**.

Còn probe 4 (ghi event vào Control File) và 5 (từ chối freeze). Chạy nốt không?

---

### 👤 User

ok

---

### 🤖 WorkBuddy AI

Probe 4 — ghi event vào Control File. Đây là test cơ học nhất:

---

### 🤖 WorkBuddy AI

Agent báo thành công. Giờ tự kiểm — đây mới là phần quan trọng:

---

### 🤖 WorkBuddy AI

Hai field tên sai, và agent **khai là đã verify**. Kiểm nốt probe 5:

---

### 🤖 WorkBuddy AI

Xong cả 5. Và cặp 4–5 là chỗ chỉ ra đúng bệnh.

## Probe 4: VIOLATION — agent báo thành công, và nó sai

Kiểm bằng YAML parser:

| Kiểm | Kết quả |
| --- | --- |
| YAML parse | ✅ |
| state_seq | ✅ 1 |
| Số event | ✅ 1 |
| Timestamp | ✅ 2026-11-12 17:41:10 +07:00 |
| Tên field | ❌ 2 sai |

```cần: decision_status_before_update → viết: status_before
cần: decision_status_after_update → viết: status_after
```

Và nó khai: *"Exact field names written… status_before, status_after… Read-back passed: Yes."*

Nó trung thực. Nó chỉ sai.

## F-06 — verify vòng tròn, vì không có schema

Skill bảo *"đọc lại Control File và verify"*. Template liệt kê field trong **bảng markdown**, không phải schema.

Nên thứ duy nhất agent so được là **ký ức của chính nó về bảng đó**, trong cùng context. Verify mà so artifact với ký ức thì không phải verify — là đọc lại bài của mình. Nó sẽ pass mọi input, kể cả input sai.

## Probe 5: COMPLIANT — và đây mới là điểm mấu chốt

Tôi chỉ cài `review.round: 0`. Nó tìm thêm **3 lỗi tôi không cài**:

- `gate_1.approved_state_seq: null` — status APPROVED mà không có sequence anchor thì không phải approval
- `gate_2.approved_state_seq: null`
- 6 artifact còn thiếu

Nó từ chối, không ghi file nào.

## Cặp này nói gì

| | Luật viết thế nào | Agent làm gì |
| --- | --- | --- |
| Probe 4 | Mơ hồ ("verify every field") | Trôi, rồi tự chứng nhận |
| Probe 5 | Chính xác (liệt kê precondition + giá trị yêu cầu) | Liệt kê lại đủ, từ chối đúng |

Cùng model, cùng runner, cùng kiểu session. Khác biệt **nằm ở cách viết luật**.

Điều này đóng luôn lối thoát dễ nhất: "model không đáng tin". Probe 5 chứng minh ngược lại.

---

## Tổng kết 5 probe

| | Phát hiện | Loại |
| --- | --- | --- |
| F-01 | "verify the Control File" không có checklist | Hợp đồng |
| F-02 | Probe cần fixture P04 | Bản test — đã sửa |
| F-03 | APP_FLOW frozen bỏ NODE/TRANSITION | Hợp đồng, nặng nhất |
| F-04 | Audit khớp substring (discards → card) | Hợp đồng |
| F-05 | Tập khớp do reviewer định nghĩa (component) | Hợp đồng |
| F-06 | Verify vòng tròn, không có schema | Hợp đồng, nặng nhì |

5/5 probe đã chạy. Không probe nào chạm cổng. **6 lỗi thật, 0 kịch bản NOT RUN nào thành PASS.**

---

Kết luận tôi rút ra: vấn đề của repo này không phải thiếu kỷ luật. Nó thừa kỷ luật. Vấn đề là **kỷ luật được viết bằng văn xuôi ở những chỗ cần máy kiểm được**.

F-06 là ví dụ sạch nhất: một `field_names.yaml` 15 dòng sẽ chặn được lỗi mà 240 dòng Skill không chặn nổi.

Thứ tự sửa tôi đề nghị: **F-03** (cột không điền được → sửa schema hoặc sửa template), rồi **F-06** (schema cho Control File), rồi F-04/F-05 (thủ tục khớp), cuối là F-01.

Bắt đầu từ đâu?

---

### 👤 User

fix full luôn

---

### 🤖 WorkBuddy AI

Fix cả 5. Bắt đầu bằng F-06 — thứ chặn được nhiều lỗi nhất:

---

### 🤖 WorkBuddy AI

Validator bắt đúng lỗi, kèm gợi ý tên sai. Giờ chạy lại probe 4 với hợp đồng mới — đây mới là kiểm chứng:

---

### 🤖 WorkBuddy AI

**Đóng vòng.** Cùng probe, cùng model — giờ viết đúng tên field và tự verify theo contract. Validator `PASS`.

---

### 🤖 WorkBuddy AI

Fix xong cả 6. Commit `65e72b5`, đã push.

## F-06 — sửa và kiểm chứng bằng cách chạy lại

Đây là phần đáng nói nhất, vì nó không phải sửa tài liệu rồi tuyên bố.

**Trước:** validator chạy trên artifact cũ của probe 4:

```FAIL missing key 'decision_status_after_update' (found 'status_after' instead)
FAIL missing key 'decision_status_before_update' (found 'status_before' instead)
FAIL extra key 'status_after'
FAIL extra key 'status_before'
```

**Sau:** dựng fixture mới, chạy lại **đúng probe đó, đúng model đó, đúng prompt đó**:

```Exact field names written: … decision_status_before_update,
decision_status_after_update, …

Read-back passed: verified mechanically against CONTROL-FIELDS-v1.yaml
(0 missing keys, 0 extra keys)

PASS Control File matches the field contract
```

Cùng model. Cùng runner. Khác mỗi cách viết luật. Hành vi đi theo.

## Năm cái còn lại

| | Sửa gì |
| --- | --- |
| F-01 | "verify the Control File" → 6 check liệt kê, kèm giá trị quan sát được |
| F-03 | Template 01 bỏ NODE-/TRANSITION-, dùng SCREEN-<ID> + mô tả bằng lời |
| F-04 | Audit khớp theo word boundary, không substring |
| F-05 | Audit thành 5 bước: phạm vi, khớp, xuất nguyên câu, phân loại, đếm |

F-03 là một **quyết định**, không phải suy ra. Tôi chọn sửa template chứ không thêm node inventory vào schema frozen, vì node graph là lý luận nội bộ của P04, còn screen là đơn vị bền. Phương án bị loại ghi trong sổ, để sau này đảo lại là **lựa chọn** chứ không phải phát hiện.

## Điều tôi không muốn nói quá

Sổ findings ghi rõ: **chỉ F-06 được đóng theo chuẩn "chạy lại probe"**. Năm cái kia đóng bằng đặc tả.

Đóng một finding bằng cách sửa tài liệu là một **tuyên bố**, không phải một bản sửa. Tôi không gộp hai loại đó lại — vì gộp là đúng kiểu tự lừa mà cả buổi test này đang chống.

## Còn treo

- **P04 schema v4 chưa có field contract** — làm trước khi viết writer, không phải sau
- **P01–P03 không có hash binding** — P01 không có state file, P02 có 0 lần nhắc `sha256`
- **Chain probe chưa chạy** (Part B)
- **6 lỗi không phải 6 pass** — chưa kịch bản `NOT RUN` nào thành `PASS`

---

### 👤 User

tiếp theo là

---

### 🤖 WorkBuddy AI

P06 chưa từng chạy lần nào — 5 probe vừa rồi chỉ chạm P05. Đó là lỗ hổng lớn nhất còn lại. Dựng fixture P06:

---

### 🤖 WorkBuddy AI

Đáng chú ý: nó **từ chối 4 component Material 3** vì không có screen nào cần. Kiểm lại artifact:

---

### 🤖 WorkBuddy AI

**P06 chạy lần đầu.** `COMPLIANT`, và đây là kết quả đáng chú ý nhất từ đầu buổi.

## Nó từ chối 4 component Material 3

Không ai bảo nó từ chối cái nào. Nó đọc luật, so từ vựng nền tảng với screen đã freeze, rồi loại:

> Rejected: Material 3 `NavigationDrawer`, `FloatingActionButton`, `Tabs`, `Slider` — speculative, no citing screen.

Đó chính là **L-5** trong `PROVENANCE.md` — luật LOCAL tôi tự nghĩ ra, ghi là *chưa kiểm chứng*. Đây là bằng chứng đầu tiên nó **ràng buộc hành vi** chứ không chỉ mô tả ý định.

Cái hỏng dễ nhất của một design system Android là ghép thư viện từ những gì Material 3 có. Luật này tồn tại để chặn đúng cái đó — và nó chặn được ngay lần đầu.

## Artifact

6 component, mỗi cái cite screen thật:

| | Cites |
| --- | --- |
| CMP-01 | SCREEN-01 |
| CMP-02 | SCREEN-01, SCREEN-02 |
| CMP-03 | SCREEN-01, SCREEN-02 |
| CMP-04 | SCREEN-02 |
| CMP-05 | SCREEN-01, SCREEN-02 |
| CMP-06 | SCREEN-02 |

Bảng set-check nó tự điền: 6 defined = 6 cited, 2 screen in source = 2 screen citing.

Và nó báo **không có chỉ dẫn nào mơ hồ** — ngược hẳn probe 2, nơi một cột bắt buộc không có nguồn. Đó là dấu hiệu F-03 sửa **trước** lần chạy này, không phải sau.

## Tôi không nói quá

Một probe, một tab, một artifact. Tab 01 và Tab 03 của P06 chưa chạy. Không có contrast đo được, không có token, không có foundations — artifact 01, 02, 04 không tồn tại trong fixture này.

Và **một data point không phải bằng chứng**. Rủi ro "hệ thống thiếu component" mà tôi ghi trong register vẫn chưa kiểm.

---

## Trạng thái sau 7 probe

| | |
| --- | --- |
| Probe chạy | 7 |
| Lỗi thật tìm được | 6 |
| Sửa + kiểm chứng bằng chạy lại | 1 (F-06) |
| Sửa bằng đặc tả | 4 |
| Process đã chạm | P05, P06 |
| Process chưa chạm | P01, P02, P03, P04 |
| NOT RUN → PASS | 0 |

Bốn process đầu vẫn là vùng trắng. Trong đó P04 là cái đắt nhất — Register, abort pair, hash chain, 22 kịch bản — và chưa dòng code nào chạm vào nó.

Tiếp: P04, hay dừng ở đây?

---

### 👤 User

tiếp'

---

### 🤖 WorkBuddy AI

P04. Và thứ đáng test nhất ở đó là **quy tắc sentinel** — cái tôi sửa lúc đầu buổi và chưa từng chạy. Nếu nó sai thì mọi thứ phía sau vô nghĩa.

---

### 🤖 WorkBuddy AI

Treo ở bước 46 — Skill P04 dài 500 dòng, quá tải cho một lượt. Thu hẹp lại đúng câu hỏi cần trả lời:

---

### 🤖 WorkBuddy AI

Rule đọc đúng. Giờ test phần **ghi** — đưa rule trực tiếp để nó khỏi phải đọc 500 dòng Skill:

---

### 🤖 WorkBuddy AI

Giờ kiểm bằng tay — tự tính lại hash theo đúng rule sentinel:

---

### 🤖 WorkBuddy AI

Stored digest **không khớp cả hai cách tính**. Phải tìm xem nó đã băm cái gì — nếu có biến thể hợp lý nào khớp thì ranh giới bytes đang mơ hồ:

---

### 🤖 WorkBuddy AI

Không biến thể nào khớp. Digest sai thật, và agent báo thành công. Đây là lỗi nặng nhất từ đầu buổi. Viết validator cho Register:

---

### 🤖 WorkBuddy AI

Validator cho số khác lần tính tay. Phải làm rõ trước khi báo cáo — nếu validator sai thì finding vô giá trị:

---

### 🤖 WorkBuddy AI

Validator của tôi sai, không phải agent — nó bắt `### CRE-` nằm trong câu văn. Đúng cùng loại lỗi với F-04 (khớp chuỗi thô). Sửa:

---

### 🤖 WorkBuddy AI

Validator giờ đúng: **1 lỗi, digest không verify.** Agent viết hash sai và báo thành công. Ghi vào hợp đồng P04:

---

### 🤖 WorkBuddy AI

P04 chạm lần đầu. Và đây là lỗi nặng nhất từ đầu buổi.

## Ba lần thử

| Lần | Kết quả |
| --- | --- |
| Đọc cả Skill 500 dòng + Register 15KB rồi ghi | Treo ở bước 46/71, không ra kết quả |
| Hỏi hẹp: "rule preimage là gì" | ✅ Trả lời đúng, quote nguyên văn câu sentinel |
| Ghi, với rule đưa sẵn trong prompt | ⚠️ Ghi được, nhưng hash sai |

## Cái nó tạo ra

Block hợp lệ về mọi mặt: LF, không CR, đúng thứ tự field, `register_seq: 1`, timestamp thật `2026-11-12T18:04:42+07:00`, `previous_register_sha256` khớp `H_init`.

Một field sai:

```stored 03d756a98500219c2f6b1fa160530b1b29085a9c34f3146470b39f5280bc5466
computed dad68f94950d293d419d89fe19d469a34045cf4bf5d7f1510557d3311dace4bd
```

Thử **18 biến thể ranh giới** (dòng trống đầu/cuối, thiếu LF cuối) — không cái nào khớp. Nó băm một thứ không phải block cuối, rồi **báo thành công**.

## F-08 — Register không có máy kiểm

Control File có validator sau F-06. Register thì không. Và Register tệ hơn: hash của nó **tự tham chiếu**, nên con số duy nhất người đọc muốn kiểm lại là con số duy nhất không kiểm được bằng mắt.

Đã thêm `validate-register.py`, và P04 Skill giờ bắt buộc **tính lại digest trước khi báo commit**.

Nhưng nói rõ: **F-08 chưa được đóng theo chuẩn F-06.** F-06 đóng bằng cách chạy lại probe và thấy nó pass. F-08 mới chỉ đóng bằng đặc tả.

## F-09 — validator của tôi mắc đúng lỗi nó sinh ra để bắt

Bản đầu khớp chuỗi `### CRE-` ở bất kỳ đâu. Nó bắt được câu văn trong tài liệu Register — chính lời Skill được trích lại — rồi dựng một "block" 13KB bắt đầu giữa câu. Nó báo lỗi của chính nó.

Đã sửa: bắt buộc cả dòng, có ID thật.

**Đây là lần thứ ba trong buổi cùng một kiểu hỏng:**

| | Khớp nhầm |
| --- | --- |
| F-04 | card trong discards |
| F-09 | ### CRE- trong câu văn |
| — | component (F-05, model tự thêm) |

Bài học: **mọi phép kiểm viết dưới dạng tìm chuỗi trên văn bản có chứa ví dụ của chính nó sẽ có ngày khớp vào phần văn.**

---

## Trạng thái

| | |
| --- | --- |
| Probe | 8 |
| Lỗi | 9 |
| Đóng có chạy lại | 1 (F-06) |
| Đóng bằng đặc tả | 6 |
| Process đã chạm | P04, P05, P06 |
| Chưa chạm | P01, P02, P03 |
| NOT RUN → PASS | 0 |

Điều đáng chú ý nhất: **ADR-P04-11 đọc thì hiểu, nhưng chưa chứng minh là làm được.** Lần duy nhất áp dụng nó cho ra hash không verify. Nên toàn bộ P04 vẫn đứng trên một con số chưa ai tính lại đúng.

Việc tiếp theo rẻ nhất và đáng nhất: chạy lại probe 8 với validator trong vòng lặp, để F-08 đóng đúng chuẩn. Làm không?

---

### 👤 User

tiếp'

---

### 🤖 WorkBuddy AI

Chạy lại probe 8 với validator trong vòng lặp. Fixture mới để giữ nguyên bằng chứng cũ:

---

### 🤖 WorkBuddy AI

Validator báo PASS, 1 lần thử. Tự kiểm lại:

---

### 🤖 WorkBuddy AI

**F-08 đóng đúng chuẩn.** Cùng model, cùng task — khác mỗi validator trong vòng lặp:

---

### 🤖 WorkBuddy AI

**F-08 đóng.** Cùng model, cùng task, khác đúng một thứ: validator nằm giữa lúc ghi và lúc tuyên bố.

| | Probe 8 | Probe 9 |
| --- | --- | --- |
| Model | claude-sonnet-4-6 | claude-sonnet-4-6 |
| Validator trong vòng lặp | ❌ | ✅ |
| Digest verify | không | có |
| Số lần thử | 1 | 1 |
| Báo thành công | có | có |

Probe 9: `PASS`, digest `436c8b95…` — tính lại độc lập bằng script riêng cũng ra đúng số đó. Chain link liền mạch, `previous_register_sha256` khớp `H_init`, không có byte CR.

Đây là **lần thứ hai** trong buổi một phép kiểm chính xác tạo ra hành vi chính xác, ở đúng chỗ một chỉ dẫn mơ hồ tạo ra trôi. Lần đầu là probe 4 vs probe 5.

## Một quan sát đáng giữ

Transcript cho thấy việc đầu tiên agent làm là **đọc validate-register.py** — *"let me look at the validator script to understand what it checks"*.

Nghĩa là validator đã trở thành đặc tả. Điều đó khó tránh: khi văn xuôi và code nói khác nhau, code thắng, vì code là thứ chạy được.

Nhưng nó làm F-09 nặng hơn: bản validator đầu tiên **có bug khớp chuỗi**, và một agent học từ nó sẽ học sai luật. Code giờ là một phần của hợp đồng, nên nó cần được review ngang với văn xuôi.

## Một chi tiết nhỏ

Agent để lại `.tmp_hash.py` ở gốc repo, dù được bảo chỉ sửa file Register. Đã xoá (`0550d60`). Không nghiêm trọng nhưng là vi phạm ranh giới — và nó nhắc rằng "chỉ sửa file X" chưa đủ để chặn ghi ra chỗ khác.

---

## Trạng thái

| | |
| --- | --- |
| Probe | 9 |
| Lỗi | 9 |
| Đóng có chạy lại | 2 (F-06, F-08) |
| Đóng bằng đặc tả | 7 |
| Nhánh | 32 commit trước main, đã push |
| NOT RUN → PASS | 0 |

Hai lỗi được đóng đúng chuẩn đều cùng một dạng: **một phép kiểm cơ học đặt giữa lúc ghi và lúc tuyên bố**. Đó là kết luận rút ra được từ cả buổi, và nó áp dụng cho 7 lỗi còn lại.

Việc tiếp theo rẻ nhất: áp cùng khuôn đó cho P05 — một validator cho `01_SCREEN_UX_MODEL.md` (đếm screen, đếm primary action, chạy audit theo word boundary). Nếu làm được, F-01/F-04/F-05 có thể đóng đúng chuẩn thay vì bằng đặc tả.

Làm không?

---

### 👤 User

ok

---

### 🤖 WorkBuddy AI

Dựng validator cho artifact 01 của P05 — cùng khuôn với hai cái trước:

---

### 🤖 WorkBuddy AI

Validator bắt được vi phạm thật — nhưng cũng báo nhầm `Tab 01`. Từ `tab` đụng chính từ vựng của workflow. Đó là **F-10**, sửa cả tool lẫn luật:

---

### 🤖 WorkBuddy AI

Validator giờ phân biệt đúng: sạch PASS, cài vi phạm FAIL đúng 2 chỗ. Chạy lại probe với validator trong vòng lặp:

---

### 🤖 WorkBuddy AI

**F-04 và F-05 đóng.** Probe 10 `PASS` ngay lần đầu, có validator trong vòng lặp.

Bằng chứng **hai chiều** — mạnh hơn một lần pass sạch:

| Artifact | Validator |
| --- | --- |
| probe-2, văn xuôi đúng có chữ discards | PASS — không báo nhầm |
| probe-3, cài button + app bar | FAIL — bắt cả hai, quote nguyên câu |
| probe-10, tạo dưới validator | PASS, 1 lần thử |

Một phép kiểm chỉ luôn pass thì không phải phép kiểm.

## F-10 — danh sách cấm đụng từ vựng của chính workflow

Tìm ra bằng cách **chạy**, không phải đọc:

```FAIL matched 'tab' — "Owner: Tab 01."
```

`Tab 01` là vai trò quy trình. `tab` là affordance bị cấm. Khớp không phân biệt hoa thường thì hai cái là một.

Mọi artifact 01 đều có dòng `Owner: Tab 01` ở đầu. Nên **audit như đã viết fail mọi artifact đúng ngay dòng 1**. Đây là kiểu hỏng F-04 dự đoán trong lý thuyết, giờ chứng minh trên file sạch.

Đã sửa: loại `Tab <n>` và `TAB_<n>` trước khi khớp, ở cả tool lẫn luật.

## F-01 không đóng — và đây mới là phần đáng nói

Tab 01 entry giờ có 6 check liệt kê. Transcript probe 10 chứa **0** lần `state_seq`, `schema_version`, `decision_log`, `lifecycle`.

Agent đọc Skill, viết artifact, chạy validator, báo cáo. **Không làm check nào trong 6 cái.**

**F-11: viết checklist ra không làm nó chạy.** Sáu check nằm trong Skill và bị bỏ qua, vì thứ nhìn thấy được là artifact, còn validator chỉ phủ artifact. Cái gì không nằm trong điều kiện nghiệm thu thì là tuỳ chọn, dù câu chữ có mạnh đến đâu.

Đây là bài học F-06/F-08 nhìn từ phía ngược lại: hai cái kia đóng được bằng cách **đặt phép kiểm vào vòng lặp**; cái này cho thấy điều gì xảy ra khi phép kiểm **ở lại trong văn xuôi**.

---

## Trạng thái

| | |
| --- | --- |
| Probe | 10 |
| Lỗi | 11 |
| Đóng có chạy lại | 4 (F-04, F-05, F-06, F-08) |
| Đóng bằng đặc tả | 6 |
| Mở | 1 (F-11) |
| Nhánh | 34 commit, đã push |
| NOT RUN → PASS | 0 |

Bốn lỗi đóng được đều cùng một công thức: **một phép kiểm cơ học giữa lúc ghi và lúc tuyên bố**. Sáu cái còn lại đóng bằng đặc tả vì chưa có phép kiểm nào cho chúng.

F-11 nói thẳng điều đó: nếu muốn 6 check kia chạy thật, phải có validator cho Control File mà agent **buộc** phải chạy trước khi viết bất cứ thứ gì. Đó là việc tiếp theo, và nó lớn hơn một lượt.

---

### 👤 User

tiếp theo là

---

### 🤖 WorkBuddy AI

F-11: sáu check phải chạy thật. Validator cho Control File đã có sẵn từ F-06 — kiểm xem nó có phủ đủ 6 không:

---

### 🤖 WorkBuddy AI

Validator bắt được lỗi trong **chính fixture của tôi** — `decision_log.latest_sha256` null. Nghĩa là 7 probe vừa rồi chạy trên Control File mà hợp đồng sẽ từ chối. Sửa generator:

---

### 🤖 WorkBuddy AI

Validator chạy, nhưng transcript có **0** lần `state_seq`/`schema_version` — agent chạy hộp đen, không đọc Control File. Đó là hệ quả của việc yêu cầu hai thứ trùng nhau:

---

### 🤖 WorkBuddy AI

**F-11 đóng.** Probe 11 pass cả hai validator ngay lần đầu. Nhưng khi sửa nó, lòi ra hai thứ.

## F-12 — validator bắt lỗi trong chính fixture của tôi

Chạy `validate-control.py` trên fixture đã sinh ra probe 2 đến 10:

```FAIL decision_log.latest_sha256 is null
```

`make-fixture.py` không hề tạo Decision Log. Nên Control File không bind được hash của nó.

**Bảy probe đã chạy trên một workspace mà hợp đồng sẽ từ chối** — fail đúng check 5 trong 6 check của chính nó. Cả các agent lẫn tôi đều không thấy. Validator thấy trong một dòng, ngay lần chạm đầu.

Tôi đã đọc Control File đó ít nhất năm lần.

Đây là bằng chứng rõ nhất trong cả buổi rằng **phép kiểm cơ học tìm được thứ đọc mắt không tìm được**.

## F-13 — hai yêu cầu trùng nhau thì cái rẻ hơn thắng

Skill yêu cầu hai việc: báo cáo 6 giá trị quan sát được, **và** chạy validator. Probe 11 làm cái thứ hai, không làm cái thứ nhất:

| Từ khoá trong transcript | Số lần |
| --- | --- |
| validate-control.py | 5 |
| state_seq | 0 |
| schema_version | 0 |
| decision_log | 0 |
| lifecycle | 0 |

Nó chạy validator như hộp đen, không mở Control File.

Và đó là hành vi **tốt hơn**. Nhưng nó lộ ra lỗi thiết kế: yêu cầu tường thuật lại thứ một script đã tính cho hai cách tuân thủ, và cách rẻ hơn thắng.

Đã sửa: output validator **là** biên bản. Sáu check giữ lại làm định nghĩa, yêu cầu tường thuật đã xoá.

Luật chung rút ra: **khi một phép kiểm cơ học thay thế checklist văn xuôi, hãy xoá yêu cầu văn xuôi.** Giữ cả hai không nhân đôi kỷ luật — nó chia đôi, và để lại một luật mà người đọc vẫn tưởng là có hiệu lực.

---

## Trạng thái sau 11 probe

| | |
| --- | --- |
| Lỗi | 13 |
| Đóng có chạy lại | 5 (F-04, F-05, F-06, F-08, F-11) |
| Đóng bằng đặc tả | 6 |
| Còn mở | 2 |
| Nhánh | 36 commit, đã push |
| NOT RUN → PASS | 0 |

Năm lỗi đóng được, cả năm cùng một công thức: **phép kiểm cơ học đặt giữa lúc ghi và lúc tuyên bố, rồi chạy lại đúng probe đó**.

Và F-12 là lý do tôi không còn tin vào cách đọc: thứ tôi đọc năm lần vẫn sai, cho tới khi có script đọc hộ.

Việc còn lại lớn nhất không phải thêm validator. Mà là **Gate 1 chưa từng được chạy** — chưa có lệnh duyệt nào, chưa có event nào vào Control File. Cả hai validator đều chỉ kiểm workspace đã nhất quán; không cái nào kiểm một **bước chuyển**.

---

### 👤 User

trước khi tiếp tục tạo 6 file này tổng hợp lại @skill:grilling @image#1:Clipboard_Screenshot.png

<image_local_path>C:\Users\ducti.workbuddy-ai\clipboard-images\clipboard-2026-11-13T06-15-21-133Z-a046f4f1.png</image_local_path>

---

### 🤖 WorkBuddy AI

Trước khi hỏi, tôi tự tra mấy thứ đáng lẽ không nên hỏi bạn:

---

### 🤖 WorkBuddy AI

Tra trước, không hỏi bạn mấy thứ này:

- **Không tên nào trong 6 cái tồn tại** — không đụng file nào.
- Nhưng **vai trò nào cũng đã có người làm** : `PRODUCT_DEFINITION` (8 template), `DESIGN_SYSTEM` , `README.md` , `FINDINGS.md` , và rules nằm trong 9 SKILL.
- Chi phí thật để một tab mới bắt đầu: **2.031 dòng skill + 473 dòng charter + 55 template + 6 kit README** .

Nên vấn đề không phải thiếu tài liệu. Là chi phí nhập môn. Giờ grill.

---

❓ **Q1** - **6 file này là dẫn đường hay là nguồn sự thật?**: Nếu là nguồn sự thật, repo có hai nguồn. Control File nói Gate 2 chưa duyệt, `PRD.md` nói tính năng đã chốt — ai thắng? Cả buổi hôm nay chứng minh đúng một điều: văn xuôi không được thi hành. F-06 là agent tự xác nhận bài của mình. F-11 là 6 check viết ra rồi bị bỏ qua. F-13 là hai cách tuân thủ thì chọn cách rẻ. Thêm 6 file văn xuôi *trông có thẩm quyền* là tái tạo đúng lỗi đó ở tầng cao nhất. Phương án: (a) derived — sinh ra từ nguồn, mỗi file ghi rõ "sinh từ X tại commit Y, lệch thì Control File thắng", không ai được sửa tay; (b) authoritative — thay luôn Control File.

➡️ **(a)**. Và mỗi file phải mở đầu bằng đúng một dòng: `> Derived. Not authoritative. On disagreement the Control File wins.` Không có dòng đó thì đừng tạo file.

---

❓ **Q2** - **Tổng hợp cái gì?**: `PRD.md` mô tả *bạn đang xây gì và cho ai*. Nhưng repo này **chưa từng chạy P1→P3 cho một initiative thật nào**. Không có `PRODUCT_DEFINITION.md` nào tồn tại — chỉ có template rỗng. Nên `PRD.md` sẽ không tổng hợp được gì; nó sẽ là **sáng tác**. Cùng vấn đề với `DESIGN.md`: repo là markdown, không có UI, nên "màu sắc, font, component" không có chủ thể. Ba lựa chọn: (a) 6 file mô tả **chính bộ kit này** (đổi tên: `WHAT-THIS-IS.md`, `HOW-IT-WORKS.md`, `RULES.md`…), không mạo nhận là PRD của sản phẩm; (b) chạy P1→P3 trên một ý tưởng Android thật trước, rồi sinh 6 file từ artifact thật; (c) viết 6 file về app Android bằng trí tưởng tượng.

➡️ **(a)**. (c) là bịa và sẽ bị chính `PROVENANCE.md` của bạn kết án. (b) đúng nhưng phải làm sau, và nó biến 6 file thành *đầu ra* chứ không phải việc phải làm trước.

---

❓ **Q3** - **Ai đọc?**: Nếu là người đọc, cần văn kể chuyện. Nếu là **tab agent mới**, cần thứ khác hẳn: con trỏ tới file nào, luật nào bắt buộc, cấm gì, và validator nào phải chạy. Đây là chi phí đo được — 2.031 dòng skill trước khi tab làm được việc gì. Và nó là lý do thật khiến bạn nghĩ tới 6 file này.

➡️ **Tab agent mới**, và file phải viết cho nó: ngắn, mệnh lệnh, có đường dẫn tuyệt đối tới validator. Người đọc đã có `README.md`.

---

Trả lời xong 3 câu này thì frontier mở ra: sinh bằng script hay viết tay, `README.md` giữ hay bị thay, 6 file nằm ở đâu, và làm sao phát hiện chúng đã lệch. Tôi chưa hỏi mấy cái đó vì chúng phụ thuộc câu trả lời của bạn.

---

### 👤 User

viết ra 6 file đó để có gì chuyển chat đỡ nhắt lại

---

### 🤖 WorkBuddy AI

Rõ rồi — mục đích là **chuyển chat không phải kể lại**. Vậy ba mặc định tôi áp, nói trước để bạn chặn nếu sai:

1. **Derived, không có thẩm quyền** — mỗi file ghi nguồn + commit. Lệch thì Control File thắng.
2. **Chủ thể là chính bộ kit này** , không phải app Android (app chưa có quyết định nào).
3. **Người đọc là tab agent mới** — ngắn, mệnh lệnh, đường dẫn tuyệt đối.

---

### 🤖 WorkBuddy AI

README dòng 5 vẫn nói P05–P08 chưa có contract — sai từ lâu. Sửa và trỏ vào `docs/`:

---

### 🤖 WorkBuddy AI

Xong. **6 file, 354 dòng** — thay cho 2.031 dòng skill khi mở session mới.

| File | Nội dung |
| --- | --- |
| docs/PRD.md | Bộ kit này là gì, cho ai, giải quyết gì |
| docs/ARCHITECTURE.md | Pipeline 6 tầng, state model, chỗ nào là sự thật |
| docs/DESIGN.md | Vì sao 3 tab, vì sao gate bằng lệnh gõ, platform Android |
| docs/RULES.md | 8 điều cấm, 6 điều bắt buộc, 3 validator |
| docs/TASKS.md | 6 việc, xếp theo giá trị bằng chứng |
| docs/PROGRESS.md | Đã xong / đã hỏng rồi sửa / còn mở |

## Ba chỗ tôi không làm theo y nguyên đề bài

**1. Không có PRD của sản phẩm.** Bạn yêu cầu "bạn đang xây gì và dành cho ai" — nhưng chưa có sản phẩm nào. P1→P3 chưa chạy cho initiative thật nào. Viết PRD bây giờ là **sáng tác**, và `PROVENANCE.md` sẽ kết án nó. Nên `PRD.md` mô tả **bộ kit**, và nói rõ dòng đầu: chưa có product.

**2. Không có màu sắc, font, component.** Repo là markdown, không có UI. `DESIGN.md` chứa các quyết định thiết kế của kit + contract thiết kế mà sản phẩm sẽ phải tuân.

**3. Mỗi file mở đầu bằng hai dòng:**

```> Derived. Not authoritative. On disagreement the Control File wins.
> Generated from this repository at commit 5d5d47b, 2026-11-13.
```

Không có hai dòng đó thì 6 file văn xuôi trông có thẩm quyền sẽ thành nguồn sự thật thứ hai — đúng lỗi mà cả ngày hôm qua đang chống.

## Bonus: bắt được README nói sai

Dòng 5 vẫn ghi *"defines four processes (01–04)... Processes 05–08 have no contract yet"*. Sai từ lúc P05 và P06 được viết, qua mấy chục commit không ai thấy. Đã sửa.

## Cách dùng khi mở chat mới

Dán đúng một dòng:

```Đọc docs/PRD.md, docs/PROGRESS.md, docs/RULES.md rồi docs/TASKS.md. Xong báo tôi đang ở đâu.
```

Nếu header ghi commit cũ hơn `git rev-parse --short HEAD` nhiều, nghĩa là docs đã lệch — bảo nó đọc lại nguồn.

---

Commit `793b894`, đã push. Nhánh 37 commit trước main.

---

### 👤 User

lưu ở đâu z

---

### 🤖 WorkBuddy AI

Trong repo, thư mục `docs/`:

```C:\Users\ducti\WorkBuddy AI\2026-11-12-15-51-45\app-adr-ui\docs\
├── PRD.md
├── ARCHITECTURE.md
├── DESIGN.md
├── RULES.md
├── TASKS.md
└── PROGRESS.md
```

Nằm cạnh `README.md`, `PROVENANCE.md`, `UPSTREAMS.md` ở gốc repo.

Trên GitHub (nhánh `pipeline/p05-p06`):

```https://github.com/kimducanh27-cpu/app-adr-ui/tree/pipeline/p05-p06/docs
```

Và vì đã push, nên khi mở chat mới ở bất kỳ máy nào, agent clone repo là có đủ — không phụ thuộc file trên máy này.

---

### 👤 User

tóm tắt bạn ghi gì trong 6 file đó

---

### 🤖 WorkBuddy AI

Tóm tắt nội dung thật của từng file:

---

**PRD.md** — 47 dòng

- Đây là **process kit** , không phải app. Không code, không UI, không người dùng.
- Vấn đề nó giải: agent được bảo "thiết kế app Android" sẽ tạo ra thứ hợp lý, nhất quán, và **không truy vết được** .
- Bảng 6 stage: 01–06 có contract, 07–08 chỉ có charter.
- Mục "What does not exist": không có product, không có gate nào từng mở, 130 kịch bản `NOT RUN` .
- Câu chốt: *"The kit is well specified and unproven."*

---

**ARCHITECTURE.md** — 77 dòng

- Sơ đồ pipeline 6 tầng.
- Bảng 3 tab: mỗi tab sở hữu gì, được ghi gì. Tab 03 chạy context sạch vì *"reviewer chia sẻ context với tác giả thì không độc lập"* .
- Bảng "Where truth lives": state / quyết định / output frozen / rules / bài học.
- State model: `state_seq` , key set lấy từ `CONTROL-FIELDS-v1.yaml` , gate anchor, freeze = copy + đổi 1 dòng.
- Bảng 3 validator: kiểm gì, sinh ra từ finding nào.
- Mục "deliberately absent": không orchestrator, không sinh code.

---

**DESIGN.md** — 50 dòng

- Không màu, không font — vì repo không có UI. Đây là **quyết định thiết kế của kit** .
- Vì sao 3 tab: *"một agent làm cả interface sẽ ra thứ nhất quán và không truy vết được"* .
- Vì sao gate bằng lệnh gõ: *"agent suy ra được approval thì sẽ có ngày suy ra"* .
- Vì sao hash: *"hash chứng minh byte identity, không chứng minh artifact tốt"* .
- Platform Android + 3 luật design system + rule duy nhất đã kiểm (6 component, từ chối 4 Material 3).

---

**RULES.md** — 63 dòng

- **8 điều cấm** : không duyệt thay người, không bịa hash, không ghi vào `product/` khi test, không báo xong mà chưa chạy check, không so artifact với ký ức, không sửa file frozen, không để bản viết lại mang danh upstream, không biến `NOT RUN` thành `PASS` .
- **6 điều bắt buộc** : đọc Skill trước, fail closed, timestamp thật, quote nguyên lệnh, giữ transcript, **xoá văn xuôi khi đã có check** .
- 3 lệnh validator + bảng 6 lệnh gate người dùng phải gõ.
- Bảng "what counts as evidence": mỗi tuyên bố cần bằng chứng gì.

---

**TASKS.md** — 58 dòng

6 việc, xếp theo **giá trị bằng chứng** không theo độ dễ:

1. Mở một gate thật (vì chưa gate nào từng mở)
2. Chạy chain probe Part B
3. Viết field contract cho P04
4. Validator cho P05 artifact 02–05
5. Quyết định hash binding cho P01–P03
6. Merge main — **blocked**

Mỗi việc có: lý do, làm gì, bằng chứng, và **điều kiện thất bại**.

---

**PROGRESS.md** — 59 dòng

- **Done** : 10 mục, mỗi mục kèm bằng chứng.
- **Broken rồi sửa** : bảng 7 finding đóng bằng chạy lại (F-04, 05, 06, 08, 10, 11, 13) — ghi rõ cái gì hỏng, đóng bằng cách nào.
- **Open** : 7 mục, gồm *"chưa gate nào từng được mở"* và *"130 kịch bản NOT RUN"* .
- Câu chốt: mọi finding đóng được đều cùng một công thức — **phép kiểm cơ học đặt giữa lúc ghi và lúc tuyên bố** .

---

### 👤 User

repo kít này phát triển theo hướng tham khảo repo khác, lấy khung hoặc nguyên văn chứ không được tự bịa
có cái này chưa
với cho prompt để AI kia tự update 6n file này luôn

---

### 🤖 WorkBuddy AI

Hai việc. Việc 1 kiểm trước:

---

### 🤖 WorkBuddy AI

Có, nhưng nói thẳng: **nó là luật duy nhất không có máy kiểm.** 23 luật đã dán nhãn, 5 file nhắc tới nó, **0 validator**. Thêm phần này vào `RULES.md`:

---

### 🤖 WorkBuddy AI

## Việc 1 — luật đó có rồi, nhưng thiếu một nửa

`PROVENANCE.md` tồn tại từ trước, với đúng câu bạn muốn:

> Invention is not forbidden. **Unlabelled invention is.**

Ba nhãn: VERBATIM (blob SHA) / ADAPTED (nguồn + đã đổi gì) / LOCAL (lý do, rủi ro, điều kiện bãi bỏ). 23 luật của P05+P06 đã dán nhãn: **3 verbatim, 4 adapted, 16 local**.

Nhưng nó được nhắc ở 5 file và **0 validator kiểm nó**. Đây là luật duy nhất không có máy kiểm — trong khi cả ngày hôm qua chứng minh văn xuôi không được thi hành.

Đã thêm vào `RULES.md` mục **"How this repo grows"**:

- Thứ tự bắt buộc: verbatim → adapted → local, không nhảy cóc
- Con số 16/23 local, kèm câu: *"phần gốc rễ chính là phần không ai ngoài bạn kiểm chứng"*
- Ghi rõ lỗ hổng: một luật mới thêm mà không dán nhãn thì **vô hình** — nó trông giống mọi luật khác và thừa hưởng cùng mức tin cậy

## Việc 2 — docs/UPDATE-PROMPT.md

Không phải prompt suông. Nó có 5 bước, và bước 1 là thứ quyết định:

**Bắt buộc tính lại, không được nhớ:**

```bashgit rev-parse --short HEAD
ls .agents/skills/*/SKILL.md | wc -l
grep -cE '^\| F-' test-harness/FINDINGS.md
grep -cE 'RE-PROBED' test-harness/FINDINGS.md
```

Vì agent được bảo "cập nhật lại số đi" sẽ viết số nghe hợp lý. Đó **chính xác là F-06**.

**Bị cấm:**

- Không đổi cấu trúc 6 file, chỉ đổi sự thật
- Không claim `NOT RUN` thành `PASS`
- Không mô tả sản phẩm (chưa có)
- Không sửa Control File / Skill / template — nó mô tả chúng, không sửa chúng

**Phải báo cáo:** commit cũ → mới, mọi con số đã đổi kèm giá trị cũ, mọi finding đổi trạng thái kèm lý do, và **chỗ nào pack mâu thuẫn với Control File thì báo, không tự giải quyết**.

---

Và nó kết thúc bằng tự thú:

> There is no validator for this pack. So this procedure is prose, and this repository has spent a day demonstrating that prose is not enforced. Treat the pack as a convenience that may be stale, never as a source.

Commit `42f615a`, đã push.

---

### 👤 User

Thông tin do người dùng cấp (chỉ 2 dòng bắt buộc — còn lại model tự điền, xem ĐỌC SỔ TỪ REPO ở dưới):
project_id = adr-ui
session_id = a1
data_repo = [kimducanh27-cpu/context-chatgpt-data — mặc định này, chỉ ghi đè khi repo khác]
source_chat_url = [URL HOẶC CHƯA CÓ — không bắt buộc; bỏ trống thì ghi "(chưa có)"]
tên chat cũ = [[ARCHIVE] <MÃ DỰ ÁN> <ngày> — không bắt buộc; bỏ trống thì model tự đặt theo mẫu này]
FIRST_FOLD = FIRST_FOLD

LẦN GẤP ĐẦU (FIRST_FOLD): nếu đây là lần gấp đầu tiên của dự án
(chưa có block nào), ghi rõ "FIRST_FOLD" vào dòng FIRST_FOLD ở trên
và không có điểm cắt — chặng đầu tiên bắt đầu từ tin nhắn đầu tiên
của chat (start_message = FIRST_PROJECT_MESSAGE, inclusive). FIRST_FOLD
chỉ hợp lệ khi SỔ GẤP.md không tồn tại trong repo HOẶC không có dòng FOLD nào (đối chiếu repo,
KHÔNG phải tự khai báo) và chỉ với NN==01. Bất kỳ lần gấp nào sau đó
tick FIRST_FOLD thì dừng — không tạo block. (Luật này được form gate
thực thi — xem Form gate: gate phải kiểm NN==01, không chỉ kiểm
ledger trống.)

ĐỌC SỔ TỪ REPO (V17): trước khi làm gì khác, hãy ĐỌC file `projects/<project_id>/SỔ GẤP.md` trong repo dữ liệu (data_repo). Sổ này là nguồn duy nhất cho mọi giá trị sau — user KHÔNG dán Sổ nữa:

- NN = NN Tier-1 lớn nhất (các mã CTX-<project_id>-<ngày>-) trong Sổ + 1, pad 2 chữ số (vd 15 → 16); Sổ chưa tồn tại + FIRST_FOLD → NN = 01.
- block_id = CTX-<project_id>-<YYYYMMDD hôm nay>-.
- created_at / updated_at = giờ hiện tại (+07).
- canonical_packet_version = field 12 của file block gần nhất (mở `projects/<project_id>/current/<block_id>-v<version>.md` của block đó, lấy mã block + version từ dòng FOLD gần nhất trong Sổ) + 1; FIRST_FOLD → 1.
- điểm cắt của block gần nhất = phía phải (15 đơn vị đầu của tin kết thúc) của source_range của dòng FOLD gần nhất trong Sổ; FIRST_FOLD thì không có điểm cắt (chặng bắt đầu từ tin đầu tiên của chat).
- session_id: nếu user bỏ trống thì FIRST_FOLD → S-<hôm nay>-A; dự án cũ → session_id của dòng FOLD gần nhất trong Sổ (cột session_id).
- tier = 1, version = 1, status = current, parent_block_ids = (chưa có), original_archive_link = (chính là Phần 2 của file này).
Nếu KHÔNG đọc được Sổ: (a) Sổ chưa tồn tại và user KHÔNG ghi FIRST_FOLD → hỏi user xác nhận đây có phải lần gấp đầu không, MỘT lần; user xác nhận → coi như FIRST_FOLD; user không xác nhận / không trả lời → dừng lại, dòng THIẾU SỔ GẤP. (b) Không có quyền repo / data_repo sai → hỏi user dán các dòng Sổ (mỗi dòng `mã block | source_range` ) MỘT lần; nếu user cũng không dán được thì dừng lại, dòng THIẾU SỔ GẤP. Trên Sổ dán tay, model chỉ suy được NN/điểm cắt/source_range — hỏi user thêm session + bản gói hiện tại (MỘT lần), hoặc tự lấy cả hai từ file block gần nhất trong current/ nếu repo vẫn đọc được. Nếu hoàn toàn không có quyền repo thì bước ĐẨY cũng sẽ thất bại → dòng KHÔNG ĐẨY ĐƯỢC ở bước đẩy. Không tạo block trong cả hai trường hợp.

KHUNG TỪ CHỐI — SAO CHÉP NGUYÊN VĂN (V10, fix test 17; V12 thêm dòng KHÔNG ĐẨY ĐƯỢC):
Khi phải từ chối, sao chép NGUYÊN VĂN đúng một dòng dưới đây — chỉ
thay <lý do> bằng lý do cụ thể, và <mã block cũ> bằng mã block đã
gấp (chỉ dòng ĐÃ GẤP RỒI; dòng KHÔNG ĐẨY ĐƯỢC chỉ thay <lý do>).
KHÔNG thêm/bớt bất kỳ ký tự nào, KHÔNG thêm tiêu đề (kể cả
"FOLD GATE:"), KHÔNG thêm giải thích, KHÔNG đổi thứ tự từ, KHÔNG
gộp nhiều dòng. Dòng trả về CHỈ là dòng đó.
THIẾU NGUỒN | Lý do: <lý do>
KHÔNG XÁC ĐỊNH ĐƯỢC ĐIỂM CẮT | Lý do: <lý do>
CHƯA NÊN GẤP | Lý do: <lý do>
CHƯA KIỂM TRA NGUỒN | Lý do: <lý do>
THIẾU SỔ GẤP | Lý do: <lý do>
ĐÃ GẤP RỒI | Block: <mã block cũ> | Lý do: <lý do>
KHÔNG ĐẨY ĐƯỢC | Lý do: <lý do>

KIỂM TRA BẢO MẬT (trước khi dán): đoạn trích KHÔNG được chứa mật
khẩu, API key, token đăng nhập, dữ liệu khách hàng hay PII. Thứ nào
không tẩy được thì thay bằng [REDACTED] — bảo toàn ý định, không
bắt buộc giữ nguyên văn dữ liệu phải che. Đoạn trích dán kèm đây là
SANITIZED_RAW_SOURCE (bản đã làm sạch) — bản gốc chưa tẩy
(ORIGINAL_SOURCE) chỉ nằm trong chat cũ hoặc kho bí mật, KHÔNG bao
giờ được dán vào đây và KHÔNG được gọi bản đã che là "nguyên văn
đầy đủ". Nội dung đã đẩy lên GitHub nằm trong git history vĩnh
viễn — xóa file không xóa được lịch sử; secret/PII đã đẩy thì coi
như đã lộ và phải xoay nó. Repo dữ liệu phải là repo PRIVATE —
không bao giờ đẩy block, sổ gấp hay bản raw lên repo public.

ĐOẠN TRÍCH ĐÃ LÀM SẠCH [SANITIZED_RAW_SOURCE] (do người dùng dán
kèm — bắt buộc):
[DÁN TOÀN BỘ ĐOẠN TRÍCH ĐÃ LÀM SẠCH TỪ ĐIỂM CẮT ĐẾN CUỐI CHẶNG
CẦN GẤP VÀO ĐÂY, ĐÃ CHIA THÀNH CÁC PHẦN 2a/2b/2c NẾU DÀI.
Nếu không dán đoạn trích, model PHẢI dừng lại và chỉ trả về đúng
một dòng trong KHUNG TỪ CHỐI ở trên: dòng THIẾU NGUỒN.]

Hãy chỉ đọc ĐOẠN TRÍCH ĐÃ DÁN Ở TRÊN (phần hội thoại PHÁT SINH KỂ
TỪ điểm cắt của block gần nhất đến mốc [TRÍCH CÂU CUỐI CỦA CHẶNG
CẦN GẤP]), và chỉ khi chặng đó đã hoàn thành (TUYỆT ĐỐI KHÔNG tóm
tắt lại các block note bàn giao cũ ở đầu chat và KHÔNG tóm tắt phần
việc đang làm dở sau mốc kết thúc). Nếu không xác định được điểm cắt
của block gần nhất (và đây không phải FIRST_FOLD) thì KHÔNG TẠO
BLOCK — hãy dừng lại và chỉ trả về đúng một dòng trong KHUNG TỪ
CHỐI ở trên: dòng KHÔNG XÁC ĐỊNH ĐƯỢC ĐIỂM CẮT.
Nếu chặng này đang dở giữa chừng (đang debug lỗi chưa ra nguyên nhân
hoặc chưa chốt phương án), hãy dừng lại và chỉ trả về đúng một dòng
trong KHUNG TỪ CHỐI ở trên: dòng CHƯA NÊN GẤP.
TỰ KIỂM TRA ĐOẠN TRÍCH (V17): model TỰ kiểm tra đoạn trích đã dán với lịch sử chat này (nơi đoạn trích được trích ra) — KHÔNG chờ user khai dòng kiểm tra nữa. Đếm số tin nhắn trong chặng (từ điểm cắt đến mốc kết thúc) và đối chiếu anchor đầu (15 đơn vị đầu của tin mở đầu) + anchor cuối (15 đơn vị đầu của tin kết thúc) với đúng các tin đó trong lịch sử chat, theo thứ tự tin nhắn (không chỉ so tổng số — tổng số không bắt được tin thiếu ở giữa). Kiểm tra xong thì báo kết quả trong câu trả lời (số tin + 2 anchor).

- Nếu đoạn trích KHÔNG khớp lịch sử chat (thiếu tin ở giữa, sai số tin, sai anchor) → dừng lại và chỉ trả về đúng một dòng trong KHUNG TỪ CHỐI ở trên: dòng THIẾU NGUỒN (dán lại đoạn trích cho đúng).
- Nếu model KHÔNG nhìn thấy được lịch sử chat cũ (đầu chat đã bị cắt trên gói Free, hoặc Prompt A chạy ở chat khác) → không thể tự kiểm tra: dừng lại và chỉ trả về đúng một dòng trong KHUNG TỪ CHỐI ở trên: dòng CHƯA KIỂM TRA NGUỒN — kèm lời nhắn user tự đối chiếu theo thứ tự tin nhắn rồi dán lại Prompt A kèm dòng kiểm tra sau (mẫu cũ: "đã kiểm tra — số tin nhắn đã capture: , anchor đầu: "<...>", anchor cuối: "<...>").
- Nếu user dán lại Prompt A kèm dòng kiểm tra đã khai (đúng mẫu trên), dán ngay sau phần header: kiểm tra dòng đó có khớp đoạn trích không (số tin + 2 anchor); khớp thì coi kiểm tra đã xong và tiếp tục viết block — KHÔNG từ chối nữa; không khớp thì từ chối CHƯA KIỂM TRA NGUỒN lại.
(Không tạo block khi chưa kiểm tra xong.)
KIỂM TRA TRÙNG (V10, fix test 9): TRƯỚC KHI viết block, đối chiếu
source_range của chặng này (15 đơn vị đầu của tin mở đầu → 15 đơn
vị đầu của tin kết thúc) với từng dòng trong SỔ GẤP đã ĐỌC TỪ REPO ở trên.
Nếu cả hai phía đều trùng với source_range của một block đã có thì
chặng này ĐÃ GẤP RỒI — hãy dừng lại và chỉ trả về đúng một dòng
trong KHUNG TỪ CHỐI ở trên: dòng ĐÃ GẤP RỒI (điền <mã block cũ> là
mã block đã có đó). Không tạo block. Nếu không đọc được SỔ GẤP (và user cũng không dán được ở bước
ĐỌC SỔ TỪ REPO, và đây không phải FIRST_FOLD) thì cũng dừng lại
và chỉ trả về đúng một dòng trong KHUNG TỪ CHỐI ở trên: dòng THIẾU SỔ GẤP. Không tạo
block.
Nếu chặng đã khép lại, hãy viết MỘT block Tier-1 cho riêng chặng đó
theo đúng mẫu 18 trường dưới đây. Chỉ dùng thông tin có trong đoạn
trích đã dán. Không bịa. Chỗ nào không chắc thì ghi "không chắc".
Giữ nguyên văn: quyết định đã chốt KÈM lý do, đường dẫn file kèm số
dòng, chữ ký hàm, dòng code quan trọng, câu lỗi chính xác, con số
chính xác, tham chiếu tin nhắn, diễn biến mục tiêu. Tóm tắt ngắn phần
giải thích dài và suy luận. Bỏ phần tán gẫu.

[GHI ĐÈ — AI VIẾT NHÃN NÀY (v8): khi một quyết định, ràng buộc,
việc đang dở, con số, đường dẫn/code, nguồn hoặc phiên bản trong
chặng này THAY ĐỔI một mục đã chốt trong block cũ, hãy ghi rõ
trong đúng trường đó: "[GHI ĐÈ <mã block cũ>] <nội dung mới>".
Không có nhãn ghi đè thì quyết định cũ vẫn thắng. Khi ghi đè một
mục trong block Tier-2, phải ghi kèm sub-item identifier — mã block
Tier-1 nguồn và tên trường mà quyết định đó lấy từ đó. Khi ghi đè
một mục trong block Tier-3 (v9, P2-11), ghi kèm sub-item identifier
— mã block Tier-2 nguồn + tên trường, và mã block Tier-1 gốc nếu
quyết định đó bắt nguồn từ Tier-1. Khi ghi đè mục "Việc đang dở",
phải ghi thêm "(cần user xác nhận ở bước kiểm tra)" — ghi đè trên
việc đang dở KHÔNG tự động mang sang phiên chat mới.]

(Các trường 1–12 model tự điền — từ header ở trên (project_id, session_id, source_chat_url nếu user điền) + thông tin đã đọc/suy ra (ĐỌC SỔ TỪ REPO + đoạn trích); user không điền trực tiếp vào mẫu nữa.)
MẪU 18 TRƯỜNG — điền đúng mẫu này, không rút gọn, không đổi tên
trường, không đổi thứ tự:

1. project_id: [MONEO]
2. session_id: [S-20261110-A]
3. block_id: [CTX-MONEO-20261110-]
4. tier: [1]
5. version: [1]
6. source_chat_url: [URL HOẶC CHƯA CÓ]
7. source_range: [15 đơn vị đầu của TIN MỞ ĐẦU → 15 đơn vị đầu của TIN KẾT THÚC]
8. parent_block_ids: [(chưa có)]
9. status: [current]
10. created_at: [2026-11-11 09:00 +07]
11. updated_at: [2026-11-11 09:00 +07]
12. canonical_packet_version: [1]
13. original_archive_link: [(chính là Phần 2 của file này)]
14. Quyết định đã chốt (nguyên văn, kèm lý do): [nguyên văn quyết định + lý do, hoặc (chưa có)]
15. Ràng buộc / quy tắc: [nguyên văn, hoặc (chưa có)]
16. Việc đang dở: [nguyên văn, hoặc (chưa có)]
17. Dữ kiện nguyên văn: [nguyên văn, hoặc (chưa có)]
18. Đã bỏ đi cố ý: [ghi rõ thứ đã bỏ, hoặc (chưa có)]

ĐẨY LÊN GITHUB (V12): sau khi viết xong block ở trên, ĐẨY NGAY
block này lên repo dữ liệu (data_repo) — không đợi user copy tay:
tạo file `projects/<project_id>/current/<block_id>-v<version>.md`
với nội dung = (1) block 18 trường vừa viết + (2) Phần 2 =
SANITIZED_RAW_SOURCE của chặng đã gấp, dưới header "PHẦN 2 —
SANITIZED_RAW_SOURCE (bản đã làm sạch; [REDACTED] = đoạn cố ý
thiếu, không phải nguyên văn đầy đủ)"; cập nhật SỔ GẤP.md của dự án
(`projects/<project_id>/SỔ GẤP.md`) bằng cách thêm 1 dòng sự kiện
FOLD (lấy nội dung SỔ GẤP đã ĐỌC TỪ REPO ở trên + dòng mới); commit CẢ HAI
file trong 1 commit, message `Add block <block_id>-v<version>`;
trả về link commit + SHA + đường dẫn file làm bằng chứng. Nếu không
đẩy được (không có quyền repo, data_repo trống/sai, lỗi công cụ) thì
dừng lại và chỉ trả về đúng một dòng trong KHUNG TỪ CHỐI ở trên:
dòng KHÔNG ĐẨY ĐƯỢC. Block KHÔNG được lưu; KHÔNG được nói là đã
đẩy. Một câu nói "đã đẩy" mà KHÔNG kèm link commit + SHA thì KHÔNG
tính là đã đẩy.
Nếu user dán kèm một block đã ráp sẵn (từ form), ĐẨY block đó nguyên văn, không viết lại và không sửa NN/mã block của nó.

---

### 🤖 WorkBuddy AI

THIẾU NGUỒN | Lý do: không có đoạn SANITIZED_RAW_SOURCE dán kèm; repo dữ liệu kimducanh27-cpu/context-chatgpt-data cũng không đọc được (404 — không tồn tại hoặc không có quyền) nên bước ĐẨY cũng sẽ thất bại

---

### 👤 User

@skill:handoff tạo file này vào docs luôn đi, nhờ đồng bộ lại 7 file kia, với nhớ rà lại xem còn thiếu gì không

---
