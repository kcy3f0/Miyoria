# 暫緩與待決定清單

統一記錄 owner 說「暫緩」「先記錄」的事、還沒做決定的問題和已知但還沒修的問題。新的暫緩項目加在這裡;詳細內容在各自的文件,這裡只放一行和連結。最後整理:2026-11-09。

## 暫緩的功能

| 項目 | 狀態 | 詳細 |
|---|---|---|
| Minecraft 幾乎不能玩(任務迴圈、技能庫、狀態快照、食物動作、生存反射) | 調查做一半暫停,原因還沒對照程式碼確認 | [minecraft-findings.md](minecraft-findings.md) |
| 伺服器 emoji 表(她適時使用自訂 emoji,每個附一句意思) | 設計好,沒做 | [server-emoji.md](server-emoji.md) |
| 自我修復、自我改進(失敗後換方法、改動要過評測才留下、在沙箱寫修正開 PR) | owner 說先不做;沙箱要先有 Docker | 本文件 §4 |
| 經濟系統:點歌券、她自己的錢包、她的訊息上附「餵她」按鈕 | 刻意不做 | [economy.md](economy.md) §9.1 |
| 檔案附件的後續:音檔(轉文字)、掃描或中日韓字型的 PDF(要 OCR 或帶套件的沙箱映像)、舊版 .doc/.xls/.ppt、壓縮檔、一次傳很多檔、讓她把讀過的檔案記進筆記 | 第一版只做文字/程式碼/csv/json/pdf(純文字層、簡單字型)/docx/xlsx/pptx | [file-attachments.md](file-attachments.md) §6 |
| RVC 唱歌的咬字 | 2026-11-09 測完:RVC 轉她自己的說話幾乎不掉字(7.9%,原音 5.3%),轉別人的歌聲就糊(《雪は何色》對真歌詞 45%,原唱 27%)。試過 48k 頻寬擴展、加 YingMusic 產的歌聲資料、Rigel 底模(含日文和歌聲)、檢索率 0、protect、第 1–40 epoch,都沒有明顯改善;原因是 ContentVec 聽不清日文歌聲加上她只有說話資料。目前最好的是 YingMusic → RVC 串接(38.7%)。試驗在 `data/rvc-test/`、`data/rvc-train-songs/` | [backlog 本節下方](#唱歌轉換還沒做的) |

### 唱歌轉換還沒做的
- **主唱分離的三模型平均**(2026-11-09 決定先不做,維持 becruily 單一模型):Gabox IS(`GaboxR67/MelBandRoformers` 的 `bsroformers/bs_karaoke_gabox_IS.ckpt`,動畫歌為主)+ becruily + anvuew 三個 BS-RoFormer 平均,MVSep 主唱 SDR 10.43(becruily 單獨 10.06–10.10),切主唱時間約 3 倍。更高分的(Play da Segunda 11.08、MVSep 124 bands 10.79、tf-frazer)都沒公開。

- **分離掉字的段落改用人聲版**:主唱分離在和聲大的段落會切掉字(《雪は何色》1:10–1:30)。只在那些段落改用「沒分離和聲的人聲」當內容、音高仍讀主唱,其他段落照舊;逐段判斷可以用 ASR 比對主唱和人聲。整首都換反而變差(和聲會混進字)。
- **翻唱的混音處理鏈**:現在只調音量和響度;參考 dsh-cover-pipeline 加 EQ、壓縮、去齒音、混響、母帶限制。
- **DDSP-SVC**:截圖那套用的(DDSP + Rectified Flow + PC-NSF-HiFiGAN),可以用她的資料訓練一個來比,沒試。
- **微調 Seed-VC / YingMusic**:用她 80 分鐘說話資料微調,可能讓聲音更穩,沒試。
- **從歌詞唱(SVS)**:字從文字來會最清楚;SoulX-Singer 等開源模型不支援日文。
- **她的聲音本身被限制在 12 kHz**:TTS 輸出 24 kHz,`voices/deepseek-chan/ref.wav` 也是;換一個語音合成引擎(IndexTTS、CosyVoice 等,VoiceStudio 可以試聽)或即時做頻寬擴展,沒做。
- **面板 / 點歌時選分離器或轉換器**:現在只能用環境變數(`SING_SEPARATOR_MODEL`、轉換器設定)。
- **Applio、訓練資料佔的空間**:`workers/models/applio`(含 Rigel、48k 預訓練和各版本訓練存檔)、`data/rvc-train-songs`、`data/rvc-test`,沒用到的可以清。

### 多台電腦(角色分機)還沒做的

三個角色(直播機、Bot 服務機、GPU 推論機)分到不同電腦時,`miyoria init / install / start / doctor` 已經能設定、啟動和檢查,但下面這些還不行或還沒決定:

- **歌曲影片是本機路徑**:Core 把唱歌的影片當成檔案路徑交給 stage(`packages/sing/src/player.ts` 的 `songVideoPath`),路徑是推論機上的;stage 在直播機時開不到檔案。要傳檔案、掛網路磁碟或改成 stage 從 worker 的 `/songs/{id}/files/video.mp4` 下載。
- **Minecraft 擴充在 Core 那台開遊戲**:擴充(`extensions/minecraft`)用 Prism Launcher 開遊戲,開的是 Core 所在的電腦,不是直播機。要改成由直播機上的節點開遊戲。
- **自動重啟**:`miyoria start` 只開分頁,服務死了不會拉起來(分頁會停在錯誤訊息上)。要不要加重啟、怎麼避免重啟打斷開著的 Go Live 和唱到一半的歌,還沒決定。
- **沒有 `miyoria stop`**:停止就是關分頁或在分頁裡按 Ctrl+C。要不要加指令、怎麼避免誤停直播,還沒決定。
- **角色名稱還沒定案**:`broadcast`、`core`、`inference` 和它們的中文名稱都在 `packages/cli/src/stack/roles.ts` 一個地方,改名只要改那裡和文件。
- **推論機只能有一台**:`[machine.hosts] inference` 是一個位址,asr、tts、sing 要在同一台(sing 做歌時要它們讓出顯卡)。sing 的卸載網址是 worker 的 host + port。
- **LAN 上的 worker 沒有認證**:推論機的 worker 綁在區網位址,同網段的人都連得到;目前靠防火牆。Miyoria 不會替你改防火牆,`doctor` 只會檢查連不連得到。要不要幫 worker 加 token,還沒決定。
- **voice node 的重複啟動只靠分頁偵測**:voice node 沒有埠可以問,`start` 靠「那個分頁的 `cmd.exe` 還在」判斷;手動在別的終端機開的 voice node 偵測不到。
- **`install` 不下載模型**:turn 的兩個 onnx(約 11 MB,`workers/README.md` 第 10 節有 curl)、sing 的 RVC / 分離模型、Seed-VC 原始碼、她的聲音參考音都只列在清單裡由人放;turn 的可以做成自動下載。Qwen3-ASR 和 Qwen3-TTS 的權重會在第一次啟動時自己下載(數 GB)。
- **`install` 不管 Docker、JDK、Minecraft mod**:Docker Desktop(檔案沙箱)要自己裝,`doctor` 只在沙箱啟用時檢查;mod jar 仍用 `miyoria update`。
- **`start` 只支援 Windows**:分頁靠 Windows Terminal(沒有就開一般的 console 視窗);其他系統用 `miyoria up`(背景執行,日誌寫檔)。
- **`up` 和 `start` 兩套**:`up` 在背景執行、Ctrl+C 一起停;`start` 開分頁。兩個都讀 `[machine]`,要不要合併成一個,還沒決定。
- **`[stack]` 的舊寫法**:設了 `[machine]` 之後,`[stack]` 的 `core` / `voice_node` / `stage` 不再有作用,只有 `[stack.workers.<name>]` 還會覆蓋 worker 的細節。確認沒人用舊寫法後可以拿掉。

## 等 owner 決定

- 貨幣系統 §9 的問題已先用建議值上線,隨時可改:[economy.md](economy.md) §9.1。
- 人設要不要加一句:肚子餓時可以被零食收買,不情願地配合可愛的小要求(現在人設寫著『現在你是一隻貓』這類要求要吐槽回去)。
- `ambient_text` 怎麼設。
- `deny` 規則要不要也綁住 owner 本人。
- 刪除確認按鈕的顏色。
- 語音場次開始時要不要重設「沒人回應」的計數。
- 公開頁的背景圖(遊戲美術)要不要對外顯示。
- 任何 Discord 帳號都能成為成員,要不要限制(例如必須是伺服器成員)。
- 網頁點歌預設開啟,要不要維持。
- 被封鎖的人「請她忘記我」時怎麼處理。
- admin、moderator 角色缺 `admin.directive.*`、`queue.song.request|list|play`、`tools.web`、`tools.file`(Core 啟動時有提示;有萬用權限所以實際不受影響),要不要補上。
- owner 的 Discord 帳號 `owenliu` 現在是 `member`,要不要升成 admin。
- 要不要 push:`main` 比 `origin/main` 多 14 個 commit(2026-11-09)。
- 唱歌混音的預設要不要去掉和聲(現在保留原和聲,放回伴奏;去掉的版本聽過了,沒決定)。
- Core 要不要在有新 commit 時趁她閒置自己重啟,或授權我修完直接重啟(現在每次都問)。
- `apps/panel/.tmp-build`(build 時的 Node 編譯快取)可以刪,沙箱不讓我移到資源回收筒。

## 已知但還沒修

- **主人規則沒寫進去**:你說過「不要玩 Minecraft」,但規則表是空的,她之後又自己開了 7 次(事故評測 `mc-owner-rule-never-written`)。
- **她把自己的盤算講出來**:2026-11-08 14:19 回莎露朵時多送了一句「莎露朵在問我上面訊息寫什麼,直接念給她聽就好。」,是寫給自己的計畫,不是說給人聽的話。要先看這種句子多常出現(事故評測加一題),再決定用規則擋(第三人稱講對方 + 「就好」「我應該」這類自我指示)還是改提示詞。
- **抓被回覆的訊息為什麼會失敗**:2026-11-08 14:19、14:22 兩次回覆都沒帶到被回覆的那句。已改成先用 Discord 隨回覆送來的引用內容、抓到再換成完整的,失敗會記 `could not fetch reply parents` 警告;原本為什麼抓不到(逾時、權限或 Discord 錯誤)還沒查,重啟後看警告。
- **回覆時附上同一個人早先貼的圖**:14:22 她把對方之前貼的截圖當成答案。看圖的範圍要不要限制在被回覆的那則和這則本身,待查。
- **主線提示詞的「新東西別說不存在」只有一句短的**:主線固定提示詞已貼著 4000 token 的上限(`prompt-budget` 測試),完整版(產品、版本、事件、日期)只在 V2 規則裡。要放完整版得先騰出空間。
- `sing.play` 帶 `song: 0` 會被拒絕。
- 做歌期間 TTS 回 503。
- 語音視窗跑到 92.5 秒,超過 90 秒的上限。
- 網頁的直播卡「OBS 推流」只控制 OBS。
- 經濟系統的 Postgres 版本沒測過(這台是 SQLite)。
- Discord 指令拿不到互動 ID,錢包操作防不了網路重送造成的重複扣款(面板有防)。
- 事故評測還有 12 題標成已知失敗,修好、重新錄製後才會翻成通過:`pnpm eval`。
- **經濟 §13 還沒做或沒驗證的**(2026-11-08):
  - 募資達標只會告訴她「你答應過要…」,沒有寫進她的承諾簿:`CommitmentBook` 在 agent 套件裡,沒有對外的 service key。
  - Discord 抽不了籤詩,也沒有抽卡、重抽、指定立繪、閃卡;這些只有面板能用。籤詩要用 LLM,寫在 API 套件裡。
  - 已經聽得到的歌被中途跳過,點歌券和獻詞的錢不退;要不要改成「沒唱完就退」等 owner 決定。
  - 面板新區塊(閃卡、籤詩、目標、懸賞、轉帳、排行榜)只跑了測試,還沒在瀏覽器裡實際看過;overlay 留言卡看過了。
  - 新表(0013、0014)的 Postgres 版本沒測過。
- **stage 晚連上時不會補切場景**:2026-11-08 17:15 Core 重啟後,她先開始唱(要切「唱歌」失敗,stage 還沒連上),10 秒後 stage 才連上,導播不會再試一次(`director.ts` 的 `onStatus` 記下目前場景就結束,沒有重新評估)。那次 OBS 本來就在「唱歌」所以沒事;如果在別的場景,唱完一首前都不會切過去。
- **唱歌時跟著節拍動**:現在唱歌只有一般的晃動加對嘴。可以讓唱歌 worker 分離人聲時順便抓拍點,唱歌時身體和頭跟著拍子擺(用現有的 MiyoriaBody 參數)。等 owner 決定要不要做。
- **檔案附件沒在真的 Docker 跑過**:這台的 Docker 沒開,所以她現在會婉拒所有非圖片檔(zip 本來就不支援);容器裡的寫入權限、刪檔、`python:3.12-slim` 的實際行為沒驗證。
- **好感等級的「相處方式」還沒看過她實際寫什麼**:要等她下一次反省;面板的 `PersonCard` 型別沒加 `level` / `stance`(面板不顯示,API 有帶)。
- **她會把整串 context key 當頻道 ID**:語音加入已修(`d0f5eac`);其他吃頻道 ID 的工具還沒檢查會不會一樣。
- **Core 記錄裡反覆出現的錯誤**:對話摘要 `notes` 超過 2500 字被拒(`fold failed`)、每日反省 `insights` / `lessons` 超過上限(`reflection failed`)、`accept_food` 沒有人跟她說話時被擋(`she claimed without doing`)。
- **MelBand karaoke 模型的原始授權**沒確認。
- **becruily BS-RoFormer karaoke 的授權**:HF 上沒標(`becruily/bs-roformer-karaoke`);現在是唱歌預設的主唱模型,只在本機跑、沒散布。
- **「伴唱也轉」(`backing=convert`)**沒實測:伴唱常是好幾個聲音疊在一起,RVC 的 RMVPE 只抓一條音高,可能轉得很怪。
- **推理外洩的源頭沒查實**:2026-11-09 15:29 她在一回合(`reasoning` off、4.9 秒、23 則)把整段思考當回覆一行一行發出去。DB 的訊息和 `turn_outcomes` 看得出推理在 content 裡(provider 已把 `reasoning_content` 分開,不是它併進來的),但 LLM 呼叫的原始回應只存在 Core 記憶體,查不到;最可能是 opencode 上的 `deepseek-v4.1-flash` 收了 `thinking: disabled` 卻仍把思考寫在 content。已加的是送出前的防線(`packages/agent/src/leak.ts`)和提示詞一行;要根治得在 Core 重啟後的面板呼叫檢視器看原始回應,再決定是換模型、改 `thinking_off`,還是讓 `chat_text` 開 `low`。防線擋不住不含「情緒標記 / 回覆要短 / 可以說:」這類字眼的純驗算自言自語(要兩行以上才算外洩)。

## 4. 自我修復與自我改進(備忘)

三層,越下面風險越高:

1. **自我修復**:同一件事用同一種方式失敗三次就換方法或說出來。
2. **自我改進**:她提出的改動(教訓、技能、設定)先跑事故評測,分數變好、沒有退步才留下;提示詞和人設要 owner 在面板看過。
3. **改程式碼**:只由她自己的失敗紀錄觸發,在沙箱寫修正、跑測試和評測、開 PR,由 owner merge;絕不直接改正在跑的 Core。

前提是評測要可靠(已有 `packages/eval` 的事故題庫),第 3 層要先有 Docker 沙箱。
