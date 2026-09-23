# TRAPS.md — bẫy riêng của software-company

Bốn khuôn lỗi chung và bẫy thao tác ở `../TRAPS.md`. Ở đây là chỗ cụ thể trong package này đã cắn người.

## Orchestrator / vòng lặp

| Bẫy | Đã xảy ra | Cách rà / chốt chặn |
|---|---|---|
| `poll()` chỉ khi hàng đợi rỗng | Quyết định gate nằm im khi công ty bận (#73) | Mọi vòng lặp dài nạp đầu vào ngoài ở mỗi nhịp |
| `partial[event_id]` nuốt lần gọi lại có chủ ý | Ký lại Gate 3 chỉ chạy được vì tình cờ vừa restart | `_recall(agent, env)` trước khi gọi lại chủ ý |
| Event cũ phát lại sau takeover | QLKH-004 mở lại 7 lần, 10.7M token (#55) | `_superseded`: `tasks` chỉ khi ticket còn `dispatched`; `pull-requests` chỉ khi là latest |
| `_rehydrate` đếm `gate.decide` chưa xử lý | Gate escalation trùng cho việc vừa duyệt (#57) | Phân biệt "đã thấy trong log" và "đã xử lý" |
| RC `pending_human`/`failed` không có route tiếp | 10 RC kẹt, status xanh (#77/#78); smoke failed (#90) | Mọi trạng thái "chờ người" mở gate; sweep mỗi nhịp; `_check_paused_releases` |
| Gate 3 gửi cho cả staging | release-engineer từ chối staging vì `gate_release=false` → 18/18 RC chết (#69) | Gate 3 chỉ gác production; `tests/test_staging_khong_doi_gate3.py` |
| Từ chối escalation RC cũ → ticket đã giao về rework | #80 | `_superseded_release` xét nội dung đã tới khách chưa |
| Xung đột merge đốt retry nội dung | Ticket `blocked` vì merge, không vì code (#63) | Bộ đếm riêng, ngưỡng riêng |
| Reset worktree vứt việc dở | 40 lượt tool viết devserver dở bị xoá, lần 2 lại từ 0 (#82) | `keep_wip` → commit WIP; HEAD là WIP mà lượt này không sửa → PR từ HEAD (#84) |

## Bằng chứng và lời khai

| Bẫy | Đã xảy ra | Chốt chặn |
|---|---|---|
| `deployed` là lời khai | 25 release, 0 điểm vào (2026-09-06) | ADR-0029 smoke do orchestrator chạy; `smoke.unverified` khi không có `runtime` |
| `env`/`release_id`/`ticket_id` do model khai | Gate 3 không mở (#72, #75) | Identity từ ROUTE; audit `*_overridden` |
| Lượt production không thấy staging/QA | "chưa qua staging" dù có (#80) | `_release_evidence` vào payload |
| Diff bị cắt mà reviewer không biết | security chặn QLKH-012 "thiếu diff" — openapi 804 dòng | `diff()` xếp mã nguồn trước, nói rõ file bị bỏ (#67); reviewer có tool đọc (#87) |
| `local_checks` pass giả từ lệnh không liên quan | frontend PR "pass" bằng ruff+pytest | `stacks.py` theo stack; không nhận ra stack → `unverified` (ADR-0013) |
| Test xanh trước khi có code | TDD chỉ là lời dặn | `qa` pha `author` chạy lượt mù (ADR-0028); `tests_green_before_code` audit |
| Ca test đi qua nhánh KHÁC với nhánh nó tưởng đang đo | Ca duy nhất chạm `diff` dùng topic `pull-requests` — một topic **dẫn xuất**, nên nó được lọc bởi nhánh `derived_topics` chứ không bởi danh sách trường. Xoá sạch `untrusted_fields` khỏi `core.py` mà **không ca nào đỏ** (đo được khi làm K3.4) | `test_truong_khong_tin_cay_tren_topic_NOI_BO_THUAN_van_duoc_loc` dùng `tasks` — nội bộ THUẦN, chỉ có một đường đi. Bài học chung: chọn dữ liệu thử sao cho nó **chỉ** đi qua nhánh mình định đo |

## Prompt / eval

| Bẫy | Đã xảy ra | Chốt chặn |
|---|---|---|
| Stash/checkout prompt trong lúc `eval-record` | Bản ghi v11, prompt v12 (2026-09-05) | `RecordingClient` chốt version lúc bắt đầu |
| Ghi đè cả file recording khi một ca lỗi | Mất ca đang tốt vì sự cố không liên quan | `save()` gộp, không ghi đè |
| Điểm chấm eval dao động | Một lần đỏ chưa phải hồi quy | CI chỉ đỏ khi bản ghi thiếu/lệch, không đỏ vì điểm |
| `claude -p` từ chối schema union ≥ 2 kiểu | Lỗi trước khi gọi model (#56) | Chuyển thành `anyOf` cho `--json-schema` |
| `claude -p` không tool cần > 1 lượt | `error_max_turns` ở effort low (#60, #62) | `CLI_NO_TOOL_TURNS = 6` |
| Prompt tĩnh nuốt ngân sách | Skill nhồi > 50% `budget_tokens_per_task` | `make assetbudget` |
| Sửa `checklists.md` không sinh lại subagent | `test_ban_dan_xuat_tren_dia_khop_nguon` đỏ | `make subagents`, commit `../.claude/agents/` |
| **`phases:` chỉ cắt SKILL, không cắt THÂN prompt** | 2026-09-13 (#286): gộp `security` (file agent 3.344 byte) vào `qa` thành pha thứ ba. Front matter `phases:` nạp đúng skill của pha, nhưng **thân `.md` của agent thì mọi pha đều mang trọn** — prompt lượt `security` phình lên **44.450 ký tự**, và `claude -p` chết `error_max_structured_output_retries` (không sinh nổi JSON hợp lệ) ở ca threat-model; eval tụt 18/18 → 16/18 | Trước khi gộp hai agent thành một agent nhiều pha: `len(spec.system_prompt(pha))` cho từng pha, so với `max_input_chars` và với prompt của agent cũ. `make assetbudget` chỉ đo phần **skill tĩnh** nên nó vẫn xanh trong khi thân prompt đã gấp 13 lần — nó KHÔNG bắt được lớp lỗi này |
| **Một agent hai pha thì lẫn đúng cái nhãn phân biệt hai pha** | 2026-09-13 (#286): sau khi gộp, model ở pha `security` khai `source: reviewer` **4/18 ca** (đo bằng model thật). `delivery.py` đếm review THEO NHÃN nên ticket rủi ro không bao giờ đủ review — nằm im, `status` không báo gì | Nhãn phân biệt lượt là **identity của lượt**, ROUTE biết chắc → để CODE điền (`orch/review_source.py::source_for`/`enforce_source`, audit `review.source_overridden`), đừng dặn trong prompt. Cùng họ với `env`/`release_id`/`ticket_id` ở bảng "Bằng chứng và lời khai" |
| **Hai route cùng agent + cùng `topic_out` trên cùng event** | 2026-09-13 (#286): gộp xong, `qa[review]` và `qa[security]` cùng đọc `pull-requests` và cùng ghi `review-results`. Khoá `partial` là `"<agent>:<topic_out>"` (PR-5b) nên route thứ hai bị route thứ nhất nuốt → ticket rủi ro chỉ nhận 1 review, kẹt `waiting` | Đây là khuôn 3 của `../../TRAPS.md` (khoá chống-trùng nuốt lần hai HỢP LỆ) ở dạng mới. Thêm route cho một agent đã gộp → kiểm khoá `partial` có phân biệt được hai route trên CÙNG một event không; và nhớ `_rehydrate` dựng lại khoá đó từ bus, nơi **pha không nằm trong event** |
| Tưởng `make eval-record` treo vì file không đổi | Chạy 1–2 giờ mà `evals/recordings/<id>.json` giữ nguyên mtime và log rỗng (PR-5x/PR-6) — `evals.py` gọi `save()` **sau** vòng lặp mọi ca và gom log vào biến, nên trong lúc chạy không có dấu hiệu nào trên đĩa | Đừng đo bằng mtime: `ps` xem tiến trình `company.evals` và tiến trình con `claude -p`. Còn hai cái đó là còn sống; giết ngang thì mất **toàn bộ** ca đã chấm |

## Vận hành

| Bẫy | Đã xảy ra | Lần sau |
|---|---|---|
| `status` xanh vì rỗng | `queue: 0, blocked: [], gates: {}` — 18/19 release chết | Hỏi "còn việc nào chạy được không"; xem `delivery`, phễu release trên console |
| `delivery: {}` | Nghĩa là chưa từng giao — nhìn suốt đêm không nhận ra | Console nay hiện "đã giao: n/m"; ở CLI đọc `metrics` |
| Nhãn `merged` ≠ đã gộp | 14/14 có merge commit, bảng hiện 4 `merged` | `merged` là nhãn FSM (sau staging deployed); sự thật git ở audit `integration.merged` |
| Ghi tay blackboard để mở khoá threat-model | Agent đọc blackboard chứ không đọc quyết định người | CR → đúng vai ghi đúng namespace |
| Duyệt gate trước, sửa tay sau | Backend dispatch lại, `workspace_reset` xoá phần chưa commit | Commit + takeover trước, duyệt sau |
| `--db` sau `publish`; thiếu `--key` | Lỗi lúc diễn tập dừng khẩn | `--db` trước subcommand; `supervisor-actions` cần `--key` |
| Agent không có tool xoá file | 4 vòng rework vô ích | Đọc `tools.py` trước khi ép |
| Quyết định kiến trúc bị né qua từng ticket | Framework/DB thật không ai chọn, 25 release không có server | ADR-0032: cùng mã nợ ≥ N review liên tiếp → gate escalation dự án (`tests/test_no_kien_truc_adr0032.py`); chưa *ngăn* từ plan — đề xuất 2 (`open_decisions`) |
| `_superseded_release` không nhận RC TRÙNG ở cuối danh sách | Đo 2026-09-10 (QLKH): `reject` một gate escalation cấp-release cho RC TRÙNG ở cuối danh sách (không có RC nào "sau" nó) mà nội dung đã tới khách trong bản giao TRƯỚC — điều kiện chỉ xét "có RC sau đã delivered"; rơi vào `rework_release_tickets`, đá ticket đã xong về `changes_requested` lần nữa | **Đã vá 2026-09-22**: mọi ticket của RC đã nằm trong một RC KHÁC đã giao (trước hay sau) → trùng, void, không rework (`tests/test_release_gates_2026_09_22.py`, có ca đối chứng RC chưa giao vẫn rework) |
| Khoá `uat:{rid}` không thế hệ nuốt lần giao thứ hai | Audit 2026-09-22 (đọc mã, chưa cắn khách): khách TỪ CHỐI nghiệm thu → ops `redeploy` cùng `rid` → lượt `deployed` thứ hai không mở lại gate acceptance vì `uat:{rid}` đã trong `once`; miễn trong `KHOA_MIEN` với lý do "production một lần mỗi RC" mà code không thi hành | Khoá nay `uat:{rid}:{event_id}` của release-event; `uat` ra khỏi `KHOA_MIEN`. Bài học: lý do miễn thế hệ phải là điều CODE bảo đảm, không phải điều "thường là vậy" |
| Hỏi người cho một quyết định máy tự làm được | Đo 2026-09-22 (CAMPUS-UNI): `_check_plan` từ chối kế hoạch hai lần liên tiếp, mỗi lần dự án đứng ở gate `escalation` hàng giờ chờ người gõ "retry" — mà "retry" chỉ là chạy lại event nguồn, không có phán đoán nào của người trong đó. Anh em `_spec_runtime_missing` đã có lượt tự sửa từ ADR-0031, kế hoạch thì không | Trước khi mở gate `escalation` cho một lỗi CẤU TRÚC máy đọc được (danh sách `problems`), trả nó cho agent sửa ít nhất một lượt kèm `hint` (`PLAN_REWORKS`); gate chỉ dành cho việc người phải phán đoán. Câu hỏi kiểm: **duyệt gate này người có gõ gì ngoài "retry" không?** Không ⇒ máy phải tự làm |
| `execv` khi reload không có đường lùi | Đọc mã 2026-09-23: `_reexec` hỏng (đường dẫn interpreter, lỗi Windows) là tiến trình chết SAU khi đã trả lease — cả đêm không orchestrator nào chạy, không lock nào tố cáo (#315 treo im lặng có thể là họ này) | `cli_cmds.run` bắt `OSError`, audit `orchestrator.reload_failed`, chạy tiếp mã cũ với reload tắt |
| `status`/console mù toàn bộ pha TRƯỚC ticket | Đo 2026-09-22 (CAMPUS-UNI): `product` hỏi vòng 1 lúc 13:11 UTC, không ai trả lời; `warnings: []`, `gates_pending: {}`, console "Sạch hàng đợi" suốt buổi. `_deadlock_warnings` thoát sớm khi chưa có ticket; không trường nào đọc `clarification-questions` | `status.clarifications_pending` + dòng `warnings` (tính từ bus, `orch/guards.py::pending_clarifications`); console đưa `CLARIFY-<pid>` vào hàng đợi gate với `decidable=false`. Câu hỏi kiểm cho lần sau: **mọi trạng thái "chờ người" có một chỗ hiện ra chưa?** |

## Bổ sung 2026-09-06 (ADR-0030)

| Bẫy | Đã xảy ra | Lần sau |
|---|---|---|
| Tưởng "đổi schema thì không phải eval lại" | Thêm `rulings` vào 19 schema → `test_committed_recordings_match_current_prompts` đỏ cho cả 21 agent: schema nằm trong prompt gửi model | Đổi bất cứ thứ gì model nhìn thấy (prompt, skill, schema, template nhúng) = `make eval-record` cho mọi agent bị chạm; ~2,5 phút/agent, chạy song song 3 luồng |
