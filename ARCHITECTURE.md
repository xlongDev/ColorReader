# ColorReader 架构

本文档记录**当前已落地**的架构，以及后续阶段的演进方向。只写已经存在的东西，未来计划单独标注。

---

## 1. 分层

```text
┌─────────────────────────────────────────────────────────┐
│  React 19 渲染层                                          │
│  UI / 交互 / Viewport / Selection / Animation             │
│  Zustand（UI 状态）  +  TanStack Query（IPC 数据）          │
└───────────────────────┬─────────────────────────────────┘
                        │  Tauri IPC（类型化、单一出口）
┌───────────────────────┴─────────────────────────────────┐
│  Rust                                                     │
│  文本加载 / 解析 / 索引 / 搜索 / 文件 IO / AI 编排           │
└───────────────────────┬─────────────────────────────────┘
                        │
┌───────────────────────┴─────────────────────────────────┐
│  SQLite（WAL）· FTS5 · sqlite-vec                         │
└─────────────────────────────────────────────────────────┘
```

边界规则（硬性）：

- **React 不直接访问本地文件系统。** 所有文件读写、目录扫描、导入导出都通过 Rust 命令。
- **整本书不进 React State，也不进 DOM。** 读取器只持有当前 viewport 与前后 buffer。
- **React 不执行大文件解析或模型推理。** 这些必须在 Rust 侧以异步任务运行。

---

## 2. Rust 侧

### 当前结构

单 crate（`src-tauri`），按职责分模块：

| 模块          | 职责                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                    |
| ------------- | ------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------- |
| `commands/`   | Tauri 命令，按域分文件，**共 22 个域 —— 目录本身就是这份清单**。这里以前手列过 11 个文件名，漏掉 10 个（`backup` / `bookmark` / `clippings` / `dictionary` / `font` / `lookup` / `stats` / `tag` / `tts` / `webview`），凡是手写的清单都会这样漂，所以不再抄一遍。在 `lib.rs` 统一注册                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                  |
| `db/`         | SQLite 连接（WAL、单写者 `Arc<Mutex<Connection>>`）+ `user_version` 迁移运行器                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                          |
| `ai/`         | AI 配置仓储（`settings` KV 表）+ OpenAI 兼容流式聊天客户端（SSE 解析为纯函数）+ embedding 客户端（批量、归一化、f32 序列化）+ rerank 客户端（Cohere 兼容）                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                              |
| `library/`    | 导入管线（去重、文件落盘、元数据提取）+ 书籍仓储（查询 / 统计）+ 章节仓储 + 标注仓储 + 全文检索 + 书档（导入 / 导出 / 加密）+ 笔记导出（Markdown / CSV）+ RAG（组块 / 索引 / 暴力检索）+ 知识图谱（LLM 抽取 / 存储 / 邻域查询）+ 书源（JSON 规则 / 搜索 / 下载）+ WebDAV 同步（进度 / LWW 合并）。**分七个子目录**：`shelf/`（书目 / 章节 / 标签 / 阅读时长 / 字体）、`marks/`（标注 / 书签 / 跨版本迁移）、`lookup/`（词典注册表 + StarDict 与 MDict 两个格式层 + 词条标记）、`retrieval/`（全文检索 / RAG）、`assist/`（知识图谱 / 阅读助手 / OCR 回写）、`transfer/`（WebDAV 同步 / 整库备份）、`io/`（导入 / 导出 / 书档 / 标注回填 / 书源）—— 标注回填自己按来源再分一层：`io/clippings/{kindle,markdown,csv}.rs` 三个解析器，加 `anchor.rs`（匹配书目与定位原文）与 `import.rs`（落库与报告）。**子目录是私有的，`mod.rs` 把每个模块 `pub use` 回顶层**，所以 `crate::library::repository` 仍然成立 —— 分层管的是「该打开哪个文件」，不是新的路径。两个目录不叫 `search/` 和 `sync/` 是因为 `pub mod search;` 与 `pub use search::search;` 同名会撞 E0255，理由写在 `library/mod.rs` 的模块文档里 |
| `document/`   | 七种格式的元数据、封面与章节正文提取：`epub`（OPF / spine）、`pdf`（逐页文本）、`mobi/`（`pdb` PDB 容器与段头 / `palmdoc` PalmDOC 与 HUFF-CDIC 解压 / `exth` 元数据块 / `index` KF8 与 MOBI6 目录 / `markup` Kindle 专有属性改写 / `text` 与 `bytes` 解码与字节读取器）、`fb2`（XML，含 `.fb2.zip`）、`cbz`（图片页）、`plain`（TXT / Markdown），`html.rs` 为前三者共用的 HTML → 段落解析器                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                            |
| `resource.rs` | `colorreader://` 自定义协议：封面图片按 id 从 Rust 流式返回                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                             |
| `secrets.rs`  | 凭据落盘时的封装：32 字节随机主密钥交给系统凭据库（Keychain / Credential Manager / Secret Service）保管，`SECRET_FIELDS` 里的字段用 AES-256-GCM 逐字段封装。**这一条常量同时被备份的脱敏引用** —— 「被封装的」与「备份里被抹掉的」必须是同一批，见下                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                    |
| `error.rs`    | `AppError`：thiserror 定义，实现 `Serialize`，统一转成 `{ message }` 交给前端                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                           |
| `state.rs`    | `AppState`（启动时间、数据目录布局、书库句柄），通过 `app.manage` 注入                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                                  |

### 数据层

SQLite（rusqlite，bundled，WAL）。Schema 通过 `user_version` pragma 做版本化迁移：每个迁移在一个事务里同时执行 DDL 与版本号更新，崩溃只停留在上一个版本；迁移**只增不改**。书库身份键是 `content_hash`（源文件 SHA-256），同时是导入去重键；`sort_title` 在 Rust 侧预计算，避免向 SQLite 注入 collation。

```text
books ─┬─ book_authors ── authors      作者多对多，按 position 保序
       └─ book_tags   ── tags         标签多对多
       └─ chapters                   章节正文（book_id + idx 复合主键，级联删除）
       └─ annotations                标注（book_id 级联删除，chapter_idx + start_char 索引）
       └─ entities / entity_relations 知识图谱（migration v7，book_id 级联删除）

chapters_fts（FTS5 外部内容表，内容指向 chapters，由触发器维护）

settings（KV：AI / 同步凭据 / 词典与字体列表，migration v5；**凭据字段在 `secrets.rs` 里封装，见下**）· chunks（RAG 向量，v6）
sources（书源规则，v8）· bookmarks（v9）· reading_sessions（阅读时长，v13）
annotation_tombstones / bookmark_tombstones（删除墓碑，供 WebDAV 同步，v15）
```

`chapters` 存的是**已提取的纯文本章节**，不是原始文件字节。主键 `(book_id, idx)` 保证一本书内章节顺序唯一；`chars` 是正文去空白后的字符数，用于进度定位。

### 凭据落盘（`secrets.rs`，2026-10-13）

AI Key、DeepL Key、WebDAV 账号与密码都住在 `settings` 这张 KV 表里，而它是一个普通 SQLite 文件 —— 能读 profile 目录的东西就能读它们。现在这些**字段**被单独封装：AES-256-GCM，密钥是 32 字节随机数，交给操作系统的凭据库保管（macOS Keychain / Windows 凭据管理器 / Linux Secret Service，走 `keyring` 的 `v1` 模式自动按平台选）。

三条设计决定，都不是随手选的：

- **这里没有 Argon2，`.ctzx` 才有。** Argon2 是用来拉伸**人类口令**的；主密钥本身就是 256 位均匀随机数，再拉一次要在每次保存时付出 19 MiB 的开销，换不到任何东西。两者的密钥来源不同，所以共用同一套 AEAD 而不共用 KDF。
- **AAD 绑定「settings 行 key + 字段名」**，所以一个密文只在它被写入的那一行那一格里打得开：把 `deeplKey` 的密文手工拷到 `apiKey` 上，结果是 GCM 校验失败，而不是一个被悄悄调换的凭据。
- **`SECRET_FIELDS` 是一条常量、两个消费者**：这里封装的字段，与 `library/transfer/backup.rs` 从备份里抹掉的字段，是同一批。加了一个凭据却只改一处，结果要么是明文落盘、要么是进了导出的归档，所以两处问的是同一个常量。

读取路径上的两个反直觉之处，都是刻意的：

- **旧明文行原样读出**（没有 `v1:` 前缀就当明文），写入时一律封装。启动时 `seal_existing` 补一遍，把升级前留下的明文立刻收掉；它在没事可做时**不碰凭据库**，所以除第一次以外每次启动都是零开销。
- **打不开的凭据是错误，不是空串。** 交回一个空串看起来就是「没配过」，而读者下一次在那张表单上点保存，就会把空串写回去、把真凭据毁掉。报错把 Key 留在原处，并让他重新填。

主密钥只取一次、缓存在进程内；取失败**不**缓存（钥匙串被锁上再解锁，不该需要重启）。`system.secretsStatus` 在读者动手之前就把「这台机器存不了凭据」说出来，设置页在 AI 与同步两块各渲染一行 —— 这个状态从输入框里是看不出来的。

🔴 **单测里 `master_key()` 返回固定值**（`#[cfg(test)]`）：headless CI 上没有 Secret Service，一个需要真凭据库的测试套件只会挂在那里。这留下唯一一处没被单测钉住的东西 —— 凭据库本身的 I/O —— 由 `#[ignore]` 的 `keychain_round_trip` 覆盖（`cargo test keychain -- --ignored`）。它用的是 `probe-account` 而不是真的账号名，否则删掉的就是读者的真主密钥。

### 阅读引擎与进度模型

章节正文在**导入时一次性提取并落库**，阅读阶段不再解析源文件。EPUB 按 OPF spine 顺序逐个 `itemref` 提取，`<head>/<style>/<script>/<svg>/<math>` 丢弃，块级边界切段落、首个标题当章节名；MOBI 是单篇 HTML，走同一个 `html.rs` 解析器按标题切章（超长章按段落边界再切，避免整本一章）；FB2 按 `<body>` 里的 `<section>` 分章；CBZ 每页图片一章；PDF 每页一章；TXT/Markdown 按标题标记（ATX `#` / `第N章` / `Chapter N`）切分，无标记则整本单章。

内嵌图片统一记成带内标记段落（`\u{FFFC}` + 容器内的可寻址名字），阅读时按需经 `book.asset` 取字节：EPUB / CBZ 按 ZIP 条目名，FB2 按 `#<binary id>`（base64 内联），其余格式没有内嵌资源。

**PDF 是唯一的固定版式例外**：阅读器不走文字段落，而是用 pdf.js（懒加载独立 chunk）把每页原样画到 canvas，`book.source_file` 返回整份文件字节。提取的逐页文本仍落库，供全文检索、朗读与 AI 使用，但不负责显示。PDF 排版不走 prose 的 multicol 分栏（页盒画布进分栏必溢出一栏，读起来就是整页空白），由独立的固定高度容器承载。目录面板由 pdf.js `getOutline()` 解析（named dest、`/A` action、UTF-16 标题均已处理，映射到 0-based 页码）；没有书签的 PDF 回退到逐页列表。封面同理由前端渲染第 1 页成 PNG，经 `book.cover_save` 落盘（书库挂载时对缺封面的 PDF 自动补一次）。pdf.js 在画布之上渲染**文本层**，选区解析、划词高亮与问 AI 全走文本层：`pdfTextSelection.ts` 的 `resolveLayerSelection` / `paintPageHighlights` / `askAboutSelection` 负责选区→字符区间、`ReaderPage` 把 `onSelection` / `onAnnotationClick` / `annotations` 接给 `PdfPageView`，`createHighlight` 以 `chapterIdx = page - 1` 落库——**文字版 PDF 的标注与划词问 AI 已与 epub / 纯文本同权**（画布本身不可划选，但文本层可，二者不矛盾）。**纯扫描件**（PDF 的真缺口，见下「扫描页识别」）。

阅读器**一次只加载一章**，整本书既不进 React State 也不进 DOM。全局进度 `0..1` 通过 `chars` 前缀和映射到章节与章内比例（`locateChapter` / `globalProgress`），定位时不需要加载任何正文。Phase 3 之前导入的书没有 `chapters` 行，`reader_toc` 在首次读取时用 `ensure_chapters`（`with_tx` 内二次检查，防并发重复插入）惰性补建索引。

### 换版本不丢标注（`book.migrate`）

`content_hash` 既是身份键也是去重键，所以**改过内容的文件重新导入就是一本新书**：标注、书签、进度全留在旧的那本上。这是这个阅读器里唯一一种「读者做对了事却付出代价」的数据丢失——修了个错别字的 epub，代价是三十条标注。

- **匹配在前端**：`migrate.ts::editionTwins` 按「同名（忽略大小写与空白）+ 作者有交集」配对，然后**问读者**。匹配刻意粗——重导入通常发生在改完文件的几秒内，判错的代价只是一次「两本都留」。
- **迁移在后端**：`library/marks/migrate.rs`，锚点是**标注自己的原文**，与 Kindle 标注回填（`library/io/clippings/anchor.rs` 的 haystack + `locate` + `signature`）是同一套，不另写一份。找不到原文位置的（新版本改了那段）**报出来**而不是静默丢掉。
- 顺序是**先复制后删除旧版**，且复制提交前旧版一直在：迁移失败读者什么都没丢。
- 🔴 **CFI 不带过去**：它指向旧文件的 spine，带着过去会把读者扔到错的地方——与 Kindle 导入同一条判据。进度带的是**比例**，不是位置。
- 收藏与标签也跟着走：那是读者的，不是文件的。

### 扫描页识别

一张扫描页没有文字层，于是它进不了检索、进不了朗读、进不了 AI——整本书在那份 PDF 里等于不能读，只能翻。这个缺口用**已经配好的那个 AI 端点**补：它本来就兼容 OpenAI 的多模态消息格式，一个 vision 模型就是一次 OCR，且**不打包任何数据集**（本地模型仍在本机）。

- 前端：`pdfOcr.ts::pageImageDataUrl` **重新渲染**这一页，而不是复用屏幕上那张——屏幕那张可能处在夜间配色、图片可能已被反相，而当前缩放也不保证可读。固定按长边 1600px 出 JPEG（`toDataURL` 也是各端点直接接受的形状）。
- 入口在页面上而不是工具栏：`PdfPageView` 在 `textReady === false` 时才挂这个按钮，条件就是「这一页没有文字层」。
- 后端：`ai/vision.rs::transcribe` 一次非流式请求；`library/assist/ocr.rs` 把结果写成**那一章的正文**，于是 FTS 触发器、朗读、RAG 组块、阅读助手四条链路同时活——它们读的是同一份语料，不需要各自认识 OCR。
- 两条拒绝都在**上传之前**：`prepare_page` 先看这一页有没有文字（有就不许覆盖，pdf.js 读出来的比模型强）、在不在这本书里（错页码没必要付一次上传）。答案里的 markdown 围栏与空行在 `normalise` 里剥掉再落库，否则空行会变成阅读器里的空段落。
- 🔴 **划词仍然不可用**，这是设计而不是遗漏：选区需要每个字的位置，而 vision 模型给的是词不是框。恢复划词要的是坐标，那是另一件活、另一类模型。

整本识别刻意没做：它是同一个调用循环一遍，但上面还差三样值得单独做的东西——进度事件、取消、以及读者在提交一百页之前能看见的花费。

页码指示器有三种范围（隐藏 / 当前章 / 全书），「当前章」永远是排版**实测**的页数，全书页数则按格式走两条不同的通路，因为两种渲染器能测到的东西本就不同。**foliate 的书（EPUB / MOBI）用 foliate 自己给的位置编号**：`SectionProgress` 把书的字节切成固定刻度（1500 字节一格），relocate 带出 `location = { current, next, total }`，`bookPageFromLocation` 只需去掉 0-based 并夹住上界（`current + 1`，封顶 `total`）。这一串数字是**书的属性**——总量只由书的字节数决定，位置只增不减，既不随翻页变也不随字号变，因此**不带「约」**；readest 展示的也正是这个计数器（只有书自带 paper page-list 时才换用真页码）。**「当前章」那一档数的是列，也就是实际页数**：relocate 另外带出节内计数 `page = { current, total }`，而 foliate 给的 `fraction` 是**列**偏移、`size` 是一次翻页覆盖的比例，所以 `total = columnCount / size` 正好等于这一节的列数，`current = round(fraction / size) × columnCount + 1` 是当前这屏的第一列 —— 单页排版列数 1、一次翻一列，双页排版一屏两列、**一次翻页走过两页，页码也跟着走两格**（翻页单位与 readest 相同：都是一屏；差别只在这张计数器换算成了实际页数，而不是让一屏算一页）。**纯文本 / Markdown 没有这种刻度**，只能靠测：`bookPagesOf` 把「已读过的章」按实测页数计入，未读的章按已测章得出的「每页多少字」估一个页数（下限一页），所以总量随阅读**收敛**而不是随光标摆动，这也是唯一带「约」的一路。**章即页的格式**（PDF、CBZ：一章恰好一个渲染单元）两者都不用，直接读 `章节序号 / 章数`。历史：最早从屏幕上那**一个**单元直接外推（`total = 单元页数 / 单元占比`），同一本 EPUB 因此报过 493、977、805、2202、939 页；随后改成「Σ实测页数 / Σ占比」，量到的占比不足 2%（封面、扉页）时退回单元页码——它不再乱摆，但对未读的章仍靠占比摊派，短章会因为「末页永远不满」把总量拖走一页。排版指纹（字号 / 行距 / 段距 / 缩进 / 页边距 / 排版模式）一变，旧高度量出来的页数属于一个已经消失的排版，纯文本那张表整表作废重来；foliate 的刻度与排版无关，不必作废。

### 标注模型

标注是一条指向章节正文的**不可变字符区间**：`(book_id, chapter_idx, start_char, end_char)` 加一份落库的 `text` 摘录。偏移量是 UTF-16 code unit 计数，**由前端计算、前端解释**，后端只做不透明存储（校验非空与区间有效性），`text` 作为列表里展示的摘录。因为章节正文对一本书而言不可变（重新导入得到新的 `content_hash`），偏移量永远不会因文本更新而失效，所以本阶段**不引入 re-location 引擎**；将来若出现可编辑正文，再以 `text` 为锚点补定位。

前端侧：`selection.ts` 把 DOM 选区经 `TreeWalker` 还原成 joined text（`paragraphs.join("\n")`）上的 UTF-16 区间，`highlightSegments` 把标注区间与搜索命中一起反切成段落内的高亮段（`<mark>`）。选区在 `mouseup` 时解析成「待确认」高亮，由浮层按钮显式落库，避免滚动/复制误触发。

### 检索模型

`chapters_fts` 是挂在 `chapters` 上的 **FTS5 外部内容表**（`content='chapters'`），正文在磁盘上只存一份，migration v4 的三个触发器（`ai` / `ad` / `au`）负责与源表同步。分词器选 **trigram**（`tokenize='trigram'`）而不是默认的 `unicode61`：后者按空格和标点切词，中文整段会退化成一个「词」，子串查询命中不了；trigram 对 CJK 子串天然可用，代价是索引更大。

排序用 SQLite 内建的 **BM25**（`ORDER BY bm25(chapters_fts)`，值越小越相关），不自己实现打分。查询串一律用双引号包成字面量后再交给 FTS5，避免用户输入的 `*`、`OR` 被当成查询语法。查询不足 3 个字符时 trigram 索引无意义，退回 `LIKE '%…%'` 子串匹配（`LIKE` 的通配符在 Rust 侧转义）。

命中结果带三样东西：上下文片段、命中在章节 joined text 里的字符偏移、章节序号。片段里被命中的那一段用两个控制字符包裹（`U+0002` / `U+0003`），前端 `parseSnippet` 按它们切开渲染——用控制字符而不是 HTML 标签，是因为正文里不可能出现它们，且后端不必假设前端怎么渲染。

`search_query` 在 `spawn_blocking` 里跑，且先为「没有 chapters 行的书」补建索引（Phase 3 之前导入的书），保证检索覆盖全库。书库侧的「全文检索」页与书内搜索抽屉共用同一条命令，只是前者不传 `book_id`。点击命中结果跳到对应章节，并把偏移换算成段落下标后滚动到视野中间。

实测（release，内存库，Apple Silicon，600 章 / 828,000 字）：索引构建 25.8 ms，单次查询 0.64–0.75 ms（返回 50 条 BM25 排序命中）。远在交互预算内，因此暂不做结果缓存与增量索引；Phase 13 建立正式 Benchmark 时再拿真实书库复测。

### 书档模型

`.ctz` 是一个 ZIP，装三样东西：`pack.json`（格式标识与版本）、`source.<ext>`（**原文件字节，一字不改**）、`reading.json`（进度、收藏、全部标注）。

书档**不装章节和封面**。两者都能在导入时从原文件重新提取，多存一份只会引入两份数据对不上的可能；原文件进包则保证书档永远能还原出和导出时一模一样的书。

`.ctzx` 是同一个 ZIP 整体加密的结果，布局是 `header_len(LE u32) || header(JSON) || nonce(12B) || ciphertext`：

- 密钥：**Argon2id**（19 MiB / t=2 / p=1，OWASP 交互登录下限）从密码派生；salt 每次导出重新生成，所以密钥也是新的，nonce 永不复用。
- 加密：**AES-256-GCM**，整个归档一次性封箱。
- **头部明文但参与认证**：KDF 参数与 salt 作为 GCM 的 AAD。篡改它们会得到「认证失败」而不是被悄悄降级成弱参数。
- 全部构件来自 RustCrypto（`argon2` / `aes-gcm`），不自研原语。GCM 分不清「密码错」和「文件坏」，错误信息也不替用户区分。

实测（release，Apple Silicon，2 MiB 归档）：加解密各约 30 ms，其中 AES-GCM 只占 1 ms 量级，其余全是 Argon2id——这正是它该有的样子，代价花在抗离线爆破上，而不是花在用户体验上。

导入路径：`import_files` 按扩展名分流，书档先解包、把原文件**暂存进书库自己的目录**（与落盘同盘，避免跨卷复制）再走既有管线，最后套用 `reading.json`；暂存文件无论成败都在返回前删除。标注按 `(chapter_idx, start, end)` 去重，重复导入同一份书档是幂等的。

`password` 作为 `book_import` 的**参数**而非回调里的提示传入：整批文件在一条 `spawn_blocking` 任务上跑完，中途弹窗会打断批处理。前端只在批次里出现 `.ctzx` 时先要一次密码，明文文件照常导入。

### 笔记导出

标注与笔记可以导出成两种**不依赖本应用**的文件，格式由目标扩展名决定（`notes.export`，与书档同一套契约）：`.md` 按章节分组、引用原文、笔记跟在引用下面；`.csv` 一行一条，带原文 / 笔记 / 颜色 / 样式。目标扩展名不认识就直接拒绝，不猜。

它和书档回答的是两个问题：书档为了把**阅读状态还原**回去（装原文件与 `reading.json`），导出文件为了**在应用之外被读**（纯文本，没有 schema，不需要本应用打开）。

两个刻意的取舍：**章节只写序号**，不查 `chapters` 表取标题——foliate 书籍的标注按 section 编号，用这个序号去取标题会整体错位，而序号与阅读器标注面板显示的完全一致；**CSV 带 UTF-8 BOM**，否则 Excel 按系统代码页猜编码，中文直接变乱码。颜色与样式为空的条目留空而不填默认值：「从没选过」和「选了黄色」是两件事，文件不该替用户编一个。

每条标注还带一个点回本应用的深链，见下节。

### 深链

导出文件里每条标注都带一个 `colorreader://book/<bookId>?annotation=<annotationId>`：点击即回到应用并定位到那条高亮。生产端是 `library/io/export.rs::link`，消费端是 `AppShell` 挂的 `useDeepLink`，中间由 `tauri-plugin-deep-link` 把系统递来的 URL 变成事件。

**链接只带身份，不带位置**，这是被证据逼出来的设计。本应用有三种互不通约的位置模型——foliate 用 CFI、纯文本用「章节 + 字符偏移」、PDF 用页码——写进 URL 的无论哪一种，用另外两种打开就是错的。而标注行自己知道它属于哪一种，所以 URL 只写 id，位置由应用查出来。同一个链接因此对三种通路都成立，将来加第四种也不用改。

解析分两层：`src/lib/deeplink.ts::parseDeepLink` 是纯函数，对系统递来的任何字符串都不信，解析不了就丢弃；`useDeepLink` 把它变成 `/reader?book=…&annotation=…`，与搜索结果走同一套查询参数，不另开一条进入阅读器的通路。阅读器侧有一条硬约束：**初始位置必须在 render 期确定，不能靠 effect 回填**（`ReaderView` 的既有判据），所以路由层在链接指名了标注时先等标注列表加载完再挂载阅读视图——foliate 书把该标注的 CFI 喂给 `startCfi`，视图 `init()` 时就落在高亮上（改成挂载后再滚会是一次看得见的跳），纯文本书则把章节喂给初始 `chapterIdx`。链接指向的标注已删除或尚未铸锚时退化为「打开这本书」，而不是打不开。

scheme 与资源协议同名（`resource.rs` 的 `colorreader`），靠 host 区分：`book` 是链接，`localhost` 是资源。两者职责不重叠——资源 URL 只在 webview 内部被 `src` 消费，从不外流。

**scheme 的注册全发生在打包期**：macOS 的 `CFBundleURLTypes` 由打包器从 `plugins.deep-link.desktop.schemes` 生成，Windows 的 NSIS / MSI 安装器写 `Software\Classes\colorreader`，Linux 的 deb 与 AppImage 带一份 `MimeType=x-scheme-handler/colorreader` 的 `.desktop`——因此不需要运行时 `register_all()` 兜底（那只对裸跑 AppImage、绿色版 exe 这类旁路安装有意义）。代价是注册只存在于打包产物里：**`tauri dev` 的窗口永远收不到链接**，macOS 实测必须 `--bundles app` 并安装到 `/Applications`（该平台不支持运行时注册，插件的 `register` 直接返回 `UnsupportedPlatform`）。

Windows / Linux 是另一套机制：系统不认识「已在运行的那个实例」，而是**再启动一个进程**，把 URL 当作唯一参数递过去。于是这一侧由 `tauri-plugin-single-instance` 承担合流，且**必须在所有插件之前注册**——「这个进程是否留下」是它在自己的 setup 里决定的：第二进程把 argv 交给先到的实例，然后退出。开启它的 `deep-link` feature 后，这次交接在进入回调之前就被转成与 macOS 同一个 `deep-link://new-url` 事件，所以 `useDeepLink` 不必区分来源；回调只剩一件事——把窗口调到前面，否则读者在浏览器里点了链接，应用却在后面。首启就带参的情况由 deep-link 插件自己处理（它 setup 时读一遍 `std::env::args`）。

### AI 助手

Provider 选型收敛为一件事：**OpenAI 兼容的 `/chat/completions`**。Ollama、LM Studio、vLLM 与托管 API 都说这个协议，所以「OpenAI 兼容」不是厂商绑定，而是事实标准；用户只需要改 `base_url`。配置（地址、Key、模型、系统提示词）存 migration v5 引入的 `settings` KV 表——**Key 只存 Rust 侧**，渲染层 localStorage 里放 Key 等于向所有能读 profile 目录的东西公开，而发请求本来也是后端的事。

流式链路：`ai_chat` 发起请求后立即返回，增量文本经 `ai://stream` 事件推送（带 `requestId` 防串台，`done` 事件收尾并可携带错误）。SSE 解析是纯函数 `feed(buffer, chunk)`：跨网络分片可恢复（只消费到最后一个换行），`[DONE]` 终止，解析不了的帧跳过而不是断流。流式循环里区分 `Delta` / `Finish` / `Done` 三类事件，部分 Provider 发完 finish reason 就关连接不发 `[DONE]`，由命令层兜底补发收尾事件。

安全默认值：明文 `http://` 只接受 loopback（`localhost` / `127.0.0.1` / `[::1]`），外网必须 TLS，否则 Key 明文过网。前端侧 `useAiChat` 维持一次一问：新提问替换上一轮问答，过期 `requestId` 的事件直接丢弃。

### 查词与翻译

划词后的动作各走最短的一条路，**离线的两条排在最前**。

**词典是「平台词典 → 导入的本地词典 → AI」这条链**，全部由 `lookup_dictionary` 一个命令走完。返回 `Found{text, source}` / `Missing` / `Unavailable` 三态**标记值而非错误**——「词典里没有」和「这里根本没有词典」都是答案，前端对两者都回落到 AI，且只对前者提示。`source` 告诉弹窗这条是哪个词典给的：系统词典为 `null`（不标注），导入的词典填自己的名字。

**第一级：平台词典**（macOS 的 `DictionaryServices`，`dictionary.rs`）。本地、瞬时、免 Key，返回纯文本词条（音标、词性、义项、`▸` 例句标记原样透传，没有标记要剥）。这不是「内置一份词典数据」——不打包也不下载任何数据集：中文系统查英文词给出中文义项加拼音，反之亦然。两条实测结论让它不必配启发式：**整段选中不是查询**（`hello world`、整句、长中文从句一律无词条），所以句子自然而然落到下一级；而 `"  spaced  "` 能剥掉空白命中 `space`。**这是 macOS 专属能力**：Windows / Linux 上返回 `Unavailable`，第二级于是成为那些平台唯一的离线来源。

**第二级：读者导入的本地词典**（注册表 `library/lookup/dictionaries.rs` + 两个格式层 `lookup/stardict.rs` / `lookup/mdict.rs`）。读者选一个文件（`.ifo` 或 `.mdx`），bundle 收进 `<data dir>/dictionaries/<id>/`，**按元数据里的 `kind` 分派到对应读取器**。列表存 `settings` 的单个 JSON（`lookup.dictionaries`），所以**不需要迁移**；查询按列表顺序试，第一个命中即返回。

**StarDict**（`.ifo` + `.idx` + `.dict`，外加可选的 `.syn`）：**`.dict.dz` 在导入时就解压**——gzip 没有随机访问，每次查词都从头解压整本，比多占一份磁盘贵得多。索引不整份驻留：扫一遍只记下**每条词条的起始偏移**（4 B/条，70 万条约 2.8 MB），查词时二分再按需 `seek` 读那一条。三处收窄（都在导入时报明确理由）：只支持 32 位偏移、`sametypesequence` 只接受单一文本类型、二进制字段（图片 / 声音）跳过。

**`.syn` 变形词表和索引共用同一个读取器**：一条 `.syn` 记录与一条索引记录的差别只在终止符之后——「词 + 4 B 条目序号」对「词 + 4 B 偏移 + 4 B 长度」——所以记录扫描泛化成 `record_offsets(bytes, value)`，两侧都只驻留偏移表（4 B/条）。查词因此是四条支路：**精确 → 小写**各试一次索引与变形词表，变形词命中的是**条目序号**而不是偏移，越界即报错（一份损坏的 `.syn` 不能把进程带走）。这是「只收 `run` 的词典划 `ran` 也能落到 `run`」的唯一通路，也是它值得单独一遍二分的原因。

**MDict**（`.mdx`）是逆向格式——MDict 闭源、没有官方规范，所以收窄得更狠：只支持 **2.0 + UTF-8 + 未加密**。1.2 会把每个尺寸字段从 8 字节换成 4，其它编码要 GBK / Big5 解码器，加密有两条各自以邮箱 / 设备 ID 为密钥的路径；这些在读头部时**按名拒绝**，而不是半解析——猜错产出的是「看起来合理的乱码」，比拒绝更糟。键与正文都在压缩块里，所以一次查词是「**按块的首 / 末键选出键块 → 解压 → 块内扫描 → 取记录偏移 → 定位记录块 → 解压 → 读到 NUL**」，只解压两块。文件里三种字节序的校验和全部校验：头部小端、键区前言大端、每块大端且算在**解压后**的数据上。`.mdd` 资源包不导入。

读取器的正确性不靠自我印证：夹具 `src-tauri/tests/fixtures/mini.mdx` 由**第三方写入器**（`writemdict`，见 `scripts/generate-mdx-fixture.py`）产出、并被**第三方读取器**接受，Rust 测试打的就是这个文件。

**翻译**走 DeepL（`lookup_translate`，Key 存 `settings`，按 `:fx` 后缀选免费 / 付费主机），一次往返、不流式；没配 Key 就与词典共用同一个 AI 流式回答。**维基百科**（`lookup_wikipedia`）取 REST summary：先精确标题、再走搜索索引兜底、再换语言版本，同样不需要 Key。

DeepL / Wikipedia 在**后端**发请求，因此 Key 永远不进渲染层，CORS 也从不适用于 webview；两条离线链则连网络都不需要。

### RAG 模型

**不用向量数据库扩展，检索是 Rust 里的暴力点积。** 一个个人书库的组块量级是几千而不是几百万（600 章 ≈ 数千块），768 维归一化向量全量扫一遍是毫秒级；sqlite-vec 的加载、版本与平台问题在这个量级下全是纯开销。等数字证明需要 ANN 时再引入，`chunks` 表的形态不会因此改变。

组块：按**段落边界**把章节正文切成约 600 字的块（单段超长则整段一块，不切断句子），`start_char`/`end_char` 与标注、搜索命中同处一个坐标系（章节 joined text 的 UTF-16 偏移）。段落是语义上最干净的切分线，块内不出现 `\n`，命中区间可直接映射到段落。

存储：向量 **L2 归一化后以 f32 LE 字节存 BLOB**，检索退化为点积（即余弦相似度）。`model` 与 `dims` 随行入表并参与过滤——不同模型的向量不在同一个空间，混比是噪声；换向量模型后重建索引即切换空间。

管线：`rag_index_book` 按批（16 条/请求）嵌入并 emit `rag://index-progress`，旧索引与新块同事务替换，失败保留原索引；`rag_chat` 把问题嵌入后取 Top-6（跨书或限单书），编号片段拼进提示词，回答流式推送、引用随 `done` 事件返回，前端点引用按既有 `chapter + offset` 参数跳转。

### 检索重排与朗读

**重排是可选的第二阶段**。重排没有 OpenAI 标准，但 Cohere 的 `/rerank` 线格式成了事实标准（Jina、SiliconFlow 等同型），所以 `rerank_model` 留空即关闭；配置后 `rag_chat` 把第一阶段召回放宽到 Top-24，再由重排模型挑出最终 Top-6。重排失败**直接报错**而不是静默降级：配置错了却每问都「碰巧还能用」，比诚实失败更难排查。

**朗读是双引擎的**：系统 `speechSynthesis`（离线、不引依赖）与 **Edge TTS**（Rust 侧 WebSocket，`tts.rs`）。之所以要有第二个，是因为默认音色 **Yunjian 是服务语音**（`zh-CN-YunjianNeural`）——`AVSpeechSynthesisVoice` 与任何系统清单里都没有它，而它正是这个阅读器想给出的默认声音。Edge 那条**必须走 Rust**：握手要一个浏览器不允许脚本设置的 `Cookie` 与 `Origin`，`Sec-MS-GEC` 是按原始时钟签的，渲染层既拿不到它也不该被信任持有。两个引擎在 `voice.ts` 里按 `edge:` 前缀分派，Edge 不可达时回落到系统音色并在面板上给出错误与重试。

播放本身仍是**一次一段**：段落边界就是天然的进度条，当前段落高亮、滚出视野才跟随滚动，本章读完自动翻章续读，generation 计数器防「cancel 后残留 end 事件重启朗读」的平台怪癖。**倍速不参与合成。** Edge 一律按 **rate 1.0** 取音频，倍速在**排程那一刻**由 `features/reader/timeStretch.ts` 对解码后的 PCM 做 **WSOLA 时间拉伸**（40 ms 帧 / 8 ms 重叠 / ±15 ms 搜索，取 SoundTouch 的语音默认值）。两条理由叠在一起：① rate 不进合成也不进缓存，于是**改速不触发任何请求**，一句缓存的音频在任何倍速下都能重放；② Web Audio 没有 `preservesPitch`（那是媒体元素才有的），直接改 `playbackRate` 是重采样、**会把嗓音变调**，而 WSOLA 是把整段波形按新间距重排，周期不变。代价是**新倍速落到下一句才生效**（readest 同款）——让倍速立刻生效要重启当前句，而重启等于扔掉已解码的缓存，正是这条路最初要消掉的东西。系统语音那条路不变：`utterance.rate` 只在 `speak()` 那一刻有效，所以两条引擎在「何时生效」上并不一致，这是平台事实而非设计选择。

**会话住在外壳，不住在阅读页。** 引擎与播放器挂在 `TtsHost`（`AppShell` 之下），`stores/speech.ts` 是接缝：阅读页只**借**一个 `SpeechTransport`，页面卸载时把它还回去，语音不停；`SpeechCard`（卡片）与 `ttsParts`（胶囊与卡片共用的零件）因此可以在第二个窗口里复用同一份。主窗口的关闭事件改成**隐藏**而不是退出，配合第二个 Tauri 窗口（`label=mini`，透明、置顶、贴着屏幕底边）与菜单栏图标，构成「窗口不在了以后仍能控制会话」的三条路：托盘、悬浮条、Dock 唤回。悬浮条那扇窗口**五档定高**（胶囊 / 主视图 / 语速 / 音色 / 定时），卡片每切一次视图就把自己的视图名报给后端、窗口随之改高。

> 上面两段是本文的结论，**为什么这么定、每条又付了什么代价、以及实测的开销数字**（含 WSOLA 在主线程上的真实耗时）都收在 **[`docs/read-aloud.md`](./docs/read-aloud.md)**。改朗读子系统之前先读那一份——这里的四条决定互相约束，单看一条会像可以「优化」回去。

### 知识图谱模型

**不引入图数据库，图就是两张表加 SQL。** 一本书的实体量级是几十到几百，邻域查询是 `(book_id, subject)` 与 `(book_id, object)` 两个索引上的普通 SELECT；真正的成本在 LLM 抽取，存储侧的任何「专用图引擎」都是纯开销。

抽取复用聊天通道：逐章把指令与正文发给 `/chat/completions`（要求裸 JSON），回答收集成字符串后取第一个 `{` 到最后一个 `}` 解析——模型偶尔包 markdown 围栏，这样切一刀就够了，不为此接 structured output 专有协议。抽取**不走**用户配置的阅读助手系统提示词，避免人设干扰指令跟随。

合并规则（Rust 侧纯函数 `merge`）：实体按名字去重、mentions 累加，空名与超过 30 字的「名字」（基本是模型在粘贴散文）丢弃；关系按 `(subject, relation, object)` 去重，保留首次出现的证据句与章节。关系**直接存名字而不是实体 id**：模型可能抽出实体表里没有的关系端点，外键只会把它悄悄扔掉。

整本重建：逐章抽取（40 字以下的章跳过）、进度经 `graph://build-progress` 推送，最后旧图与新图同事务整体替换——中途失败保留旧图谱，永远不会有半张图。

### 书源模型

**书源是一份用户可编辑的 JSON 规则**，存 `sources` 表（migration v8，整份定义一个 JSON 列：书源在 UI 里按单文档编辑，没有任何查询需要触及单条规则）。规则语言是刻意收窄的 JSONPath 子集 `$.a.b[*].c`，手写约 60 行求值器——足够表达真实书源，小到一眼可审计；不引 scraper / JSONPath 依赖，HTML 网页源暂不支持（仅 JSON 接口源）。

五个阶段对应书源的五组规则：`search`（搜索地址 `{{keyword}}` 手写百分号编码，无需 urlencoding 依赖）→ `book`（详情）→ `chapters`（目录）→ `content`（正文，字符串按行切或字符串数组）→ `download`。必填规则缺失在保存时 `validate` 拦下，可选字段（作者 / 简介 / 封面）求值失败降级为空串而不是整条失败。

**下载产物走既有导入管线**：逐章抓取、拼成带「第N章」标记的 TXT（书源自带标记的标题原样保留），写入暂存文件后调用 `import_files`——去重、哈希、章节切分全部复用，下载的书和本地导入的书在书架上没有区别。进度经 `source://download-progress` 逐章推送，暂存文件无论成败都清理。

### 同步模型

**同步对象有三样：阅读进度、标注与书签。** 进度以 `content_hash` 为键——同一份书文件在任何设备上哈希相同，天然对齐，无需中央注册表；标注与书签以各自的 UUID 为键，创建它的设备生成一次、其余设备原样沿用，所以同一个 id 处处指同一条。云端是一个 WebDAV 目录下的单个 `state.json`（`version` 现为 2；v1 旧文件仍能解析，新增的两张表默认空），HTTP 只用三个动词：GET 取状态、PUT 写状态、MKCOL 补缺失的祖先目录。同步凭据存 `settings` KV 表（`sync.webdav`），与 AI Key 同一安全模型：渲染层永不持有；`sync.device_id` 首次同步时生成。

合并是三个 LWW 纯函数（`merge` / `merge_annotations` / `merge_bookmarks`）。进度逐本合并：**两边进度相同视为一致**（不看时间戳，否则每次同步都会因时钟翻新产生无谓重传），进度不同时时间戳新者胜、平局云端胜（两台设备同一秒写入时收敛而不是来回翻）。标注与书签逐条合并，规则同此，只在两处收紧：`updated_at` 相同时**删除胜过活项**（否则删掉的标注会被一个同秒的旧副本复活），且两边 `same_payload` 时只保留较新的时钟、不产生写入（同样是为了不 churn）。删除靠**墓碑**传播——`delete` 把行真删（本地所有查询因此都不需要「未删除」过滤），并在 `annotation_tombstones` / `bookmark_tombstones` 留一行，`for_sync` 把墓碑与活行一并交给合并。远端赢的条目只在本地导入了那本书时才落库（按 `content_hash` 解析出本地 `book_id`），否则留在状态里，等有这本书的设备来取。

每本书的决策（上传 / 下载 / 云端独有 / 一致）连同标注、书签的计数（上传 / 下载 / 删除，只报数量、不列条目）随 `sync_now` 返回给 UI 展示。两条安全底线：**云端 JSON 解析失败直接中止同步**——绝不拿本地数据覆盖一个可能恢复的远端；PUT 前只应用「胜出」的值，本地赢时写回的是相同值，不产生回退。

两处刻意的简化：墓碑不剪枝（个人量级下每次删除多几行而已，`for_sync` 的注释写了升级路径）；同一句话在两台设备离线各划一次会得到两条——uuid 不同，不做按区间折叠，罕见且可手删。

### 导入管线

`book_import` 接收绝对路径数组，`spawn_blocking` 中逐个处理，每个文件完成后向前端 emit `book://import-progress` 事件（`{ done, total, path }`）。单文件流程：读取字节 → SHA-256 → 命中 `content_hash` 即返回 `duplicate` → 按格式解析元数据与封面 → 书籍文件与封面复制进 app data 目录 → 事务写入。三种结果：`imported` / `duplicate` / `failed`，批量结束一次性返回，UI 不因单个失败文件中断。

### 资源协议

封面不经过 `file://`，走 `Builder::register_uri_scheme_protocol` 注册的 `colorreader://`。URL 形态因平台而异（macOS `colorreader://localhost/cover/{id}`，Windows/Linux `http://colorreader.localhost/cover/{id}`），由 `resource::resource_origin()` 在编译期编码，前端只拿后端拼好的 `coverUrl`。处理链：校验 id 形态（UUID 字符集、长度上限、拒绝 `..`）→ 查库定位封面路径 → 读文件按 MIME 返回，非法 id 一律 404。同一协议还承担两件事：**书籍源文件**（`/book/{id}`，支持 `Range`，让开书不再随文件体积增长）与**导入的字体**（`/font/{id}`）。字体那条多了两个必须的头：`Access-Control-Allow-Origin: *` —— 字体是跨源加载且受 CORS 约束，漏了就是静默回退到别的字体；`Cache-Control: immutable` —— URL 里是导入时新生成的 UUID，内容不可能变，而一个 20 MB 的中文字体若每上一屏就重取一次，就是肉眼可见的卡顿。

### 自定义字体

中文字体是几十兆字节、许可也各自独立，所以**不内置任何字体**，读者把自己已有的文件导入进来（`font.import`，接受 `.ttf` / `.otf` / `.ttc` / `.woff` / `.woff2`）。副本落在 `<data dir>/fonts/<uuid>.<ext>`，列表存 `settings` 的单个 JSON（`reading.fonts`），与词典同一套零迁移做法。`.ttc` 收进来了但只加载其中第一个字面形：CSS 无法指定集合里的第几个，拒绝文件则是把一种能用的字体变成不能用。

命名是这条链的关键一步：字体在 CSS 里叫 `cr-<id>`，设置里选中它用 `custom:<id>`，**两个名字都由 id 推出来**。这让 `resolveFont` 保持成一个对设置值的纯函数——选择器有列表，样式构建器没有。

**霞鹜文楷是唯一一个「不导入也能用」的字面**，而且它只活在 `pnpm dev`：`lxgw-wenkai-webfont` 是 582 个 `@font-face` 规则加 29 MB 子集，凡是要打包出去的构建都不带它——GitHub Pages 预览（`PAGES_BASE`）与桌面安装包（`CR_NO_BUNDLED_FONT`，`scripts/build-app.mjs` 经 `beforeBuildCommand` 设置）都在 `vite.config.ts` 里把 `bundledFont` 模块与样式表换成空壳，选择器因此不再提供这个字体（`offeredFontStacks` 读 `BUNDLED_FONT_AVAILABLE`），而不是静默回退到系统楷体。实测三种构建：标准 35 MB / 582 子集，两个打包构建各 5.8 MB / 0 子集。🔴 别把这两条别名写成 `resolve.alias` 对象里排在 `"@"` 后面的条目：字符串别名按前缀匹配，`"@"` 会先吞掉所有 `@/…`，排在后面的精确别名永远不生效——这个坑真实存在过几个月，两个「已剔除」的构建一直打着全部 29 MB。

`@font-face` 要**分别**声明在两处，因为书的一节是一个独立文档，应用文档里的声明进不去它：书的那份随注入的样式表一起进 section（`FoliateStyle.fontFaces`），应用侧这份在 `AppShell` 里渲染一个 `<style>`，覆盖 prose 通路与设置界面。`font-display: swap` 是必需的：默认行为会在字体下载完之前不显示文字，而中文面孔有几十兆。

最后两处容易漏：CSP 的 `font-src` 必须放行资源协议的源，否则 iframe 里的字体被策略挡掉；删除一个正在使用的字体时，`useDeleteFont` 会把设置退回 `system` —— 否则阅读面会去请求一个再也没有 `@font-face` 声明过的族名，文字悄悄变成浏览器的兜底字体，屏幕上没有任何解释。

### 演进为 Workspace 的触发条件

规范里给出的 `crates/` 划分（`reader-core` / `document-parser` / `search-engine` / `database` / …）**刻意推迟**。拆分时机是当出现下面任一信号：

1. 单个模块超过约 800 行且存在两个以上互不相关的变更理由；
2. 某个模块需要被第二个 crate 复用（例如 `database` 同时被 `reader-core` 和 `rag` 依赖）；
3. 某个模块的编译时间开始主导增量构建。

在此之前，一个 crate + 清晰的模块边界比十几个空壳 crate 更利于维护。原则：**模块边界必须清晰，而不是为了目录好看而拆包。**

### 错误处理

生产路径禁止 `unwrap()` / `expect()`。所有命令返回 `Result<T, AppError>`，错误必须满足：类型化、可序列化、对用户友好、已记录日志。日志走 `tracing`，默认 `colorreader=info`，用 `RUST_LOG` 提级。

---

## 3. 前端架构

Feature-oriented：`components/` 放可复用 UI，`features/` 放业务领域。路由是单一 `AppShell` + `Outlet`。

### 状态归属

| 状态类型          | 归属               | 例子                                                    |
| ----------------- | ------------------ | ------------------------------------------------------- |
| UI / 交互 / 偏好  | **Zustand**        | 侧边栏折叠、主题、书架视图、命令注册表、面板开关        |
| 服务端（IPC）数据 | **TanStack Query** | 系统信息、书库列表、搜索结果、AI 回答                   |
| **会话**          | **Zustand**        | 朗读的队列 / 封面 / 章节 / 进度：读者发布它，外壳消费它 |
| 派生数据          | `useMemo`          | 命令面板的评分与分组                                    |

禁止把 IPC 返回值塞进 Zustand，也禁止把所有业务状态塞进 Zustand。

**会话单列一档，因为它既不是偏好也不是 IPC 数据**：`useReaderSettings` 是可持久化的偏好，
`stores/speech.ts` 不是——它是「此刻正在响着的声音」，退出就该消失。判断依据是**谁来写**：
阅读页写、外壳读，中间没有第三个持有者。

### 阅读渲染：两条通路，一份语料

| 通路                   | 何时使用                          | 渲染                                                                     |
| ---------------------- | --------------------------------- | ------------------------------------------------------------------------ |
| Document Model         | pdf / fb2 / cbz / markdown / txt  | Rust 抽取纯文本段落 → 段落索引 → FTS5 / 标注 / 朗读 / RAG 全基于段落索引 |
| foliate-js（原书排版） | mobi / azw / azw3 / **epub** 恒用 | `makeBook()` + `<foliate-view>` 渲染原书 XHTML + CSS                     |

两个**容器格式**都走 foliate：KF8 把正文拆成 skeleton + fragment，部首页壁纸、
插图、字体与配色全在原书 CSS 里；EPUB 自带样式与固定版式（fixed-layout）同理。
抽成纯文本段落必然丢排版——这是反复修不好的根因，不是某个解析 bug。

FB2 / CBZ / TXT / MD 仍走 Document Model——它们的原书样式几乎没有内容；
PDF 走自己的 pdf.js 通路，foliate 的 `pdf.js` 已打桩禁用。

**一份语料**：`document::read_chapters` 对七种格式（含 mobi、epub）统一抽纯文本
入库，导入期由 `library/io/import.rs` 落表。所以不论哪条通路在渲染，FTS5 / RAG 组块 /
书内检索命中的都是同一份章节文本。双轨只存在于**渲染侧**：标注、划词、朗读定位
在 foliate 通路上以 CFI 为锚，在 Document Model 上以「章 idx + 偏移」为锚。
这点正是我们没有照搬 readest 全量方案的原因——它把渲染全交给 foliate 后，
不得不自建「每本书一个索引库 + 反抽正文」才拿回检索与 RAG；我们导入期就有。

**PDF 是唯一例外，而且是刻意的**：它的「章节」就是页，页索引在导入期落好
（页数来自元数据那次解析，白送），**正文**却推迟到导入之后。理由是量出来的——
756 页 / 21 MB 的文档，全量逐页抽正文 974 ms，占整条导入路径的 98%，而书架和
阅读器都不等它（渲染走 pdf.js，正文只喂检索 / 朗读 / AI）。`books.chapters_pending`
记着这笔欠账，`chapters::backfill` 在导入后由后台任务补上——所以进程中途被杀也只是
**晚一点**有正文，不会永远没有。

还债的入口按「谁要文字」划分，这是有代价的：`ensure`（阅读器取目录）**只承诺索引，
不还债**。它曾经顺手补正文，结果是点开刚导入的 PDF 要等一整次抽取——导入省下的时间
原样挪到了第一次打开上。真正消费文字的路径才还债：`ensure_text`（检索 / RAG / 图谱）
和 `content_ready`（读某一章，走阻塞线程池，不挡 UI）。其余格式的渲染器读的就是抽
出来的文本，推迟等于没内容可显示，因此照旧在导入期抽完。

- 入口：`src/features/reader/FoliateBookView.tsx`，路由级 lazy，仅上述书籍打开时加载。
- 位置：CFI 存 `books.location`（`readerSetProgress` 的 `location` 参数）；
  旧的 `localStorage: colorreader:foliate:<bookId>` 只作一次性兜底读取。
  🔴 切通路不换算坐标：epub 首次以 foliate 打开时没有 CFI 可续，从书首开始；
  之后位置一直是 CFI。
- foliate 通路已对齐：标注回显（`draw-annotation` + `create-overlay` 重绘）、
  书内检索（`view.search()`）、TTS 起读与洗色、页码与目录，均以 CFI 为锚。
- 🟡 迁移前已有的 epub 标注没有 CFI：仍在标注列表里，但不再上色、点击不跳转。
  新标注一律带 CFI。要补就得按 `text` 反查 CFI，等真有抱怨再做。
- **fixed-layout**（`rendition:layout = pre-paginated`）：`view.open()` 自动切到
  `foliate-fxl`（`fixed-layout.js` 动态分块，32 kB）。接线只有两处：
  ① `applyLayout` 给它 `spread` 属性——它不认 paginator 的 `max-column-count`；
  ② 页面反色靠 `foliate-view[data-fxl-night]::part(filter)` 反色 iframe
  （view 元素上补了 `exportparts`，把 renderer 的 `filter` part 转出到文档样式）。
  固定版式不吃排版设置：字号、行距、段距、首行缩进对它无效，这是版式本身决定的。
  🔴 **该属性只在 `view.isFixedLayout` 且用户开了「夜间图片 → 反色」时才加**
  （`syncPageInvert`）：paginator 给**每一个** section iframe 也挂了 `part="filter"`
  （`paginator.js:780`），所以在可重排书上标记 view 会把**已经排好的夜色页面**整体
  反相——`#15181d` 纸面 + `#c9ced8` 墨色反成「浅纸 + 深墨」，插图一起反相，看上去
  与夜间模式完全没生效一模一样。诊断时 🔴 别只看 `getComputedStyle`：CSS filter 是
  绘制期效果，computed 值永远正确，只有像素（或截图）能证伪。
- **排版与主题注入**（`src/features/reader/foliateStyle.ts`）：一份字符串注入每个 section
  文档，light 只给排版，dark 再叠 readest 的色彩方案。要点：
  - `html` 上发 `--theme-bg-color` / `--theme-fg-color` / `--override-color: true`，
    paginator 的 `#background` 层据此把「无图页面」的填充换成主题色，带 `url()`
    的纸面（Kindle 水彩、章节图版）原样保留。
  - **元素级重漆**：`html, body` 的 `color` 只够到达直接继承的文本；Calibre 系
    转换书把颜色写在每个自有 class 与行内 `style` 上，所以还要给块级/内联元素
    加 `color: fg !important`——否则夜间就是「黑字压夜色」。`background-color`
    故意不强制：section 自己的背景交给上面的 resolver 处理。
  - **图片封顶**：`img/svg/video/canvas` 加 `max-width/height: 100% !important` +
    `object-fit: contain`，另给带像素 `width` 属性的元素（`width="900"` 这类印刷稿）
    加 `max-width: 100% !important`。paginator 的 `setImageSize` 在横向分页下以
    「元素自己的 CSS 宽度」为准，只在没有作者宽度时才回落到父级 100%，所以书把
    图包进印刷宽度盒子时图会溢出栏位——规则补的就是这一段。
  - **图片反色是 opt-in**（设置「夜间图片 → 原色/反色」，store `invertBookImages`，
    默认关）：dark 且开启时在 sheet 末尾追加 `img, svg, video, canvas, image
{ filter: invert(1) hue-rotate(180deg) }`；prose 通路（FB2/CBZ/TXT/MD）用
    `.invert-book-images` 挂同一条规则；PDF 另有自己的 `pdfInvertImages`。默认关的
    理由：调色板已经把纸面压暗，反相的照片是缺陷不是功能；开是给「整页就是一张亮
    位图」的书（漫画、扫描图版）省亮度用的。
  - 🔴 全链路禁写 `color-scheme`（注入样式、index.html、App 根都不写）：WebKit 里
    used color-scheme ≠ normal 会把「根透明」的 iframe 画布画成不透明，盖死身后
    的 `#background` 层与壁纸。模板字面量里的注释也禁写反引号（会提前闭合模板）。
- **vendored fork 的本地补丁**（`src/vendor/foliate-js/`，均为 `// local patch` 注释）：
  ① `epub.js` 的 `loadReplaced`：把资源重写成 `blob:` 时，同时把容器内路径写到元素
  的 `data-path` 上——section 文档里 `src` 全是 blob URL，书内图片浏览器按档案路径
  索引，除这里之外无处可join；② `paginator.js` 的暗色背景 resolver 保图不保色；
  ③ `pdf.js` 打桩禁用（本项目 PDF 走自己的 pdf.js 通路）。
- **书内图片浏览器**：正文里点图 → 该 section 的 `click` 监听（`attachSection`，与
  keydown/mouseup 同一入口，幂等）读 `data-path` → `onImageOpen` → `ReaderPage`
  在 `book_images` 里定位 → 打开 `ImageLightbox`。渲染框任一边小于 48px 的图不当
  可点目标（书里的分隔线、项目符号也是图片）。
- 协议：ColorReader 为 AGPL-3.0-or-later，foliate-js 为 MIT，
  见 `THIRD-PARTY-NOTICES.md` 与 `THIRD-PARTY-foliate-js-LICENSE`。

### 命令系统

命令注册表是**单一事实来源**，键盘、命令面板、菜单、右键菜单统一从这里取：

```text
Command（lib/commands.ts）
  ├── id / title / description / group / keywords
  ├── shortcut?: Shortcut[]        → useHotkeys 全局监听
  ├── icon?: ReactNode
  ├── isEnabled?: () => boolean
  └── run: () => void | Promise<void>
```

`useHotkeys` 在可编辑元素（`input` / `textarea` / `[contenteditable]`）内不触发，避免与输入框抢键。

**阅读器自己的键不在这张表里，但用的是同一套词汇。** `readerKeys.ts` 是一张纯表（`ReaderKeyBinding`：`id` / `title` / `keys` / `when(ctx, stroke)`），`resolveReaderKey` 按声明顺序取第一个命中且闸门放行的绑定，`ReaderPage` 只负责搭上下文、把 id 翻译成调用。**它们不能做成全局快捷键**：同一个键的含义取决于阅读器正在显示什么（翻页版式里左右键翻页、滚动版式里翻章，标尺开着时左右键归标尺，灯箱开着时它独占键盘），而注册表的 `shortcut` 语义是「这个键，在任何地方」——挂上去既会在阅读器外触发，又会让含义依赖注册顺序。灯箱是「换一张表」而不是给每条绑定加 `!lightboxOpen`，所以「模态期间别的绑定不许抢键」不可能被逐条漏掉。

两个字段值得单独记住：`inEditable`（Escape 要在搜索框里也能用，它是抽屉的关法）与 `keepDefault`（Escape 不阻止默认行为——浏览器构建用的是真的 Fullscreen API，Esc 退出全屏是浏览器在做的事，拦下来会把读者困在全屏里）。🔴 这两条都属于 Escape，改动时别按「其他键怎么写就怎么写」照搬。

**改键是「覆盖」，不是「改默认值」。** `KeyOverrides`（`lib/commands.ts`）是一张扁平的 `Record<id, Shortcut[]>`，**注册表命令与阅读器键表共用一张**（两套 id 空间不重叠：`app.*` / `nav.*` / `reader.*`），落在 `useSettings` 里跟着 `persist` 走。消费者一律问 `effectiveKeys(id, 默认值, overrides)`，不直接读 `command.shortcut`；`useHotkeys` 与 `resolveReaderKey` 都是**每次按键现读** store，而不是绑定时捕获——store 才是「现在绑的是什么」的那份记录，一个要重新绑定才听得见改动的监听器就是它的第二份副本。`null` 表示删除（缺席即默认），所以没有「恢复默认」这个值需要存。

设置页的 `KeymapSection` 是唯一写这张表的地方。`useRecorder` 的监听器挂在 `window` 的**捕获阶段**并吞掉听到的一切：录制时按 ⌘K 不能让命令面板盖在正在改键的面板上（`useHotkeys` 是冒泡阶段，捕获先跑，`stopPropagation` 直接掐掉整段冒泡），Escape 是取消，裸修饰键与 `Dead` / `Unidentified` 不绑（`shortcutFromStroke`）。**面板只改 `keys`**：闸门（`when`）与 `inEditable` / `keepDefault` 都跟按键无关，面板碰不到。

**改键能把某个绑定改到按不到，面板必须说得出来。** `unreachableBindings` 把四个闸门（灯箱 / 标尺 / 版式 / 竖排）的 16 种组合全枚举一遍，找「在任何上下文里都赢不了」的绑定，并点名是谁拿走了它的键。**按表分别枚举**：一个键归哪张表由模态决定（灯箱开着就是灯箱表），所以灯箱里的绑定不会去怪阅读表里持有 Escape 的那个人。`sharedShortcuts` 则只对**全局**命令有意义——阅读器里同一个键绑两条是设计（闸门决定谁生效），全局命令没有闸门可让，同一个键就是一次按键触发两个动作。

### 路由

桌面应用没有地址栏，使用 `createMemoryRouter`。命令 → 路由跳转通过一个 `CustomEvent` 桥接（`useNavigationBridge`），因为命令注册表本身在 React Router 之外。

**返回是记下来的，不是从历史里读的。** 阅读器里的「返回」要回到打开这本书的那一页 —— 书库 / 最近 / 收藏 / 标签 / 笔记 / 统计 / 搜索，七个入口。memory router 没有可查询的地址栏，而阅读器还会自己压栈（RAG 引用会打开另一本书），所以 `navigate(-1)` 在那条路径上指回的是上一本书，不是书架。做法是 `AppShell` 用一个 effect 记住最近一次非 `/reader` 的 pathname（`chrome.readerReturnPath`，**不持久化**：它是这次会话从哪来，不是偏好），阅读器的按钮读它，并按来源改自己的文案。

**页面卸载不等于状态丢失。** 进阅读器会把书库或笔记页整个卸载，所以「回来时还是刚才那样」不能靠组件状态 —— 书架视图与笔记页的筛选都落在 `useSettings` 里（`shelfViews` / `notesView`，见 `src/stores/settings.ts`），跟着 `persist` 一起活过重启。这是「偏好」而不是「业务数据」，与下面「禁止把 IPC 返回值塞进 Zustand」不冲突。

---

### 命令系统（续）：错误处理与日志

| 层     | 机制                                                                                   |
| ------ | -------------------------------------------------------------------------------------- |
| 渲染层 | `ErrorBoundary`，根节点一个 + 路由出口一个。崩溃只影响一个页面，侧边栏与命令面板仍可用 |
| 数据层 | 调用点自行处理。IPC 拒绝与 Query 错误不冒泡到 ErrorBoundary                            |
| 日志   | `lib/log.ts` 的 `createLogger(scope)`：结构化载荷，开发 `debug` / 生产 `info`          |

`ErrorBoundary` 是全项目唯一的 class 组件（React 没有对应的 Hook），只用 `getDerivedStateFromError` + `componentDidCatch`，不碰任何旧式生命周期。它是**兜底隔离墙，不是错误处理**：预期内的失败必须在发生处处理，禁止用 `console.log` 代替。日志禁止写入书籍正文、用户输入的完整内容、API Key。

---

## 4. IPC 契约

### 命名

命令按域分组，一个域一个 `src-tauri/src/commands/<domain>.rs`，命令名是 `<域>_<动作>`：

```text
ai.*          annotation.*  book.*        bookmark.*    clippings.*
dictionary.*  font.*        graph.*       lookup.*      notes.*
pack.*        rag.*         reader.*      search.*      source.*
stats.*       sync.*        system.*      tag.*         tts.*
```

示例：`system_info`、`book_import`、`reader_chapter`、`search_query`、`annotation_create`、`pack_export`。

Tauri 命令名在 Rust 里是 snake_case，前端通过 `src/lib/ipc.ts` 的单一出口调用，**不散落 `invoke` 调用**。返回值类型由 Rust 签名生成，落在 `src/lib/bindings.ts`（`src/types/ipc.ts` 只做转出与少量别名）。

### 绑定由 Rust 生成（tauri-specta）

**命令的总数不抄在本文档里。** 2026-09-28 把「71 / 69 / 2」改成「80 / 77 / 3」，2026-10-11 又是
82 / 79 —— 两次都是同一件事，手写的数字必然漂。事实来源有三处，都在仓库里自己说话：
`src-tauri/src/lib.rs` 的 `generate_handler!`（派发，也就是实际可调用的命令）、同一文件里的
`collect_commands!`（生成 TS 绑定的那些）、`ls src-tauri/src/commands/`（命令域，目录本身就是清单）。
**例外恒定为 3 条**（二进制通道），见下。生成产物 `src/lib/bindings.ts`
**要提交**，改动 Rust 签名后重新生成：

```sh
cd src-tauri && cargo test --lib specta_bindings::export_bindings
pnpm exec prettier --write src/lib/bindings.ts   # 生成物未格式化，pre-commit 会卡住
```

几条不能忘的约定：

- **派发仍是 `tauri::generate_handler!`**，`tauri-specta` 只当类型生成器。`book_asset` /
  `book_source_file` / `webview_capture_region` 返回 `tauri::ipc::Response`（二进制通道），specta
  建不了模；而 `tauri::ipc::Invoke` 没有 `Clone`，两个 invoke handler 拼不起来。代价是命令清单写两遍：
  漏在 `collect_commands!` 会让该命令从生成的 `commands` 对象里消失（`tsc` 直接报错），漏在
  `generate_handler!` 则只有运行时才炸 —— 两个方向都要核，改完这两处各数一遍。
- `.error_handling(ErrorHandlingMode::Throw)`：生成的 `Promise<T>` 在 `Err` 时 reject，TanStack Query 的
  `onError` 语义不变（默认的 Result 联合类型会逼所有调用点改错误处理）。
- `.dangerously_cast_bigints_to_number()` 必开，否则 `u64`/`usize` 拒绝导出。
- `AppError` 的 `Type` 必须**手写成 String**（它的 `Serialize` 是纯字符串，derive 会变成 tagged enum）。
  注意路径是 `specta::datatype::DataType`，写错会让所有 `Result<T, AppError>` 报一堆假错误。
- 事件负载不在任何命令签名里，必须 `.typ::<T>()` 显式注册（`ImportProgress`、`AiDelta`、
  `RagProgress`、`GraphProgress`、`SourceProgress`）。
- 生成类型是 Rust 类型的事实：`f64` → `number | null`；`#[serde(default)]` → 可选字段；
  `skip_deserializing` → `_Serialize` / `_Deserialize` 分裂（如 `Font`，前端取 `Font_Serialize`）。

### 事件

事件名统一为 `<域>://<事件名>`，Rust 侧是 `commands/<域>.rs` 里的
`pub const <X>_EVENT`，负载类型由 Rust 生成（见上），经 `src/types/ipc.ts` 转出：

```text
book://import-progress       { done, total, path }
ai://stream                  { requestId, text, done, finishReason, error, citations? }
rag://index-progress         { done, total }
graph://build-progress       { done, total }
source://download-progress   { done, total, chapter }
```

目前只有这五个事件；TTS 的音频走 `tts_edge_speak` 的返回值、同步结果是 `sync.now` 的
返回值，两者都不发事件。

---

## 5. Design System

### Token

全部定义在 `src/styles/globals.css` 的 `@theme` 中，通过 Tailwind v4 暴露为工具类：

| 类别 | Token                                                                                  |
| ---- | -------------------------------------------------------------------------------------- |
| 圆角 | `--radius-sm 14px` · `md 18px` · `lg 24px` · `xl 28px` · `2xl 32px` · `3xl 40px`       |
| 模糊 | `--blur-sm 12px` · `md 20px` · `lg 30px` · `xl 48px`                                   |
| 缓动 | `--ease-out` · `--ease-in-out`                                                         |
| 阴影 | `--shadow-glass` · `--shadow-panel`                                                    |
| 颜色 | `--color-surface-1/2/3` · `--color-hairline` · `--color-text-1/2/3` · `--color-accent` |

圆角下限是 **14px**。规范里点名的 4–8px"后台式圆角"不出现在这个代码库里。

### 材质层级（重要）

Liquid Glass 的代价是 `backdrop-filter`：**嵌套的玻璃会把模糊一层层叠加，既糊又慢**。因此材质被分成三级，只有顶层材质带模糊：

| 级别        | 工具类        | 用途                             | 模糊                        |
| ----------- | ------------- | -------------------------------- | --------------------------- |
| elevation 1 | `glass`       | 面板内部的卡片、行、图标底座     | 无                          |
| elevation 2 | `glass-2`     | 顶层表面：侧边栏、主面板、对话框 | `blur(30px) saturate(180%)` |
| elevation 3 | `glass-solid` | 浮在内容之上的气泡 / 提示        | 无                          |

`GlassSurface` 是唯一入口，组件通过 `elevation` 选择材质，不自己拼 `backdrop-filter`。

### 可访问性

- `prefers-reduced-motion` → `MotionConfig reducedMotion="user"` 全局降级，各组件另用 `useReducedMotion()` 兜底。
- `prefers-reduced-transparency` 与设置项「减少透明度」→ 顶层材质转为接近不透明并关闭模糊。
- `prefers-contrast: more` → 提高描边与正文对比度。
- 焦点环统一由 `focus-ring` 工具类提供。

### 对比度预算

文字 token 的 alpha 按**它们实际所落的最暗表面**（dark 下约 `#161922`，light 下约 `#fdfeff`）校验，而不是按 `app-bg` 单独校验。当前实测值：

| Token    | dark            | light           | 用途                       |
| -------- | --------------- | --------------- | -------------------------- |
| `text-1` | 0.92 → 约 14:1  | 0.90 → 约 13:1  | 标题、正文                 |
| `text-2` | 0.64 → 约 7.7:1 | 0.70 → 约 5.3:1 | 次要说明、表值             |
| `text-3` | 0.52 → 约 5.1:1 | 0.62 → 约 4.5:1 | 12px 元信息，仍须过 AA     |
| `accent` | 白字约 8.4:1    | 白字约 5.4:1    | 主按钮填充、焦点环、选中态 |

`text-3` 承载 12px 文字，所以不能按"三级灰就该淡"来给值；light 主题的 `accent` 由 `#a9671b` 下调到 `#96591a`，因为前者白字只有 3.9:1，按钮文案过不了 AA。改动任何一个文字或强调色 token，都要重算这张表。

### 浏览器默认表面

`::selection`、caret、滚动条、`::placeholder`、`accent-color`、下划线偏移都不由组件绘制，但都会出现在界面上。它们在 `globals.css` 中统一接管，不在组件里各写一份。z-index 只有四层：`-1` 窗口背景、`0` 内容、`50` 弹层、`60` 颗粒层（fixed、禁用命中、永不加在滚动容器上）。

---

## 6. 安全

- **最小权限，且权限是逐命令的**：`capabilities/default.json` 目前授予 `core:*`（app / event / window）+ `core:window:allow-start-dragging` / `is-fullscreen` / `set-fullscreen` / `set-theme`、`dialog:allow-open`、`dialog:allow-save`、`deep-link:default`、`opener:allow-open-url`（白名单只放行本仓库与维基百科）。**每个条目必须对应一个真实存在的调用**，并说明理由。
  🔴 两个坑：其一，`dialog:allow-open` **不放行** `save`——该插件没有 `default` 权限集，只能逐条列；被 ACL 拒绝时前端拿到的是 **reject**，于是空 `catch {}` 会让它退化成「按钮没反应」，源码里查不出（`save` 的两个调用点因此共用 `src/hooks/useSavePath.ts` 收口这条接缝）。其二，capability 是**编进 Rust 二进制**的，改完必须重启 dev / 重新打包。
- **不给渲染层 `fs *` / `shell *` / `process *`。**
- **不暴露 `file://`**：资源走 `colorreader://resource/{id}`，由 Rust 校验 id → 路径后流式返回（Phase 2 落地）。
- CSP 已收紧为 `default-src 'self'`，样式允许内联（Tailwind 运行时需要）。

---

## 7. 性能红线

以下属于**架构层约束**，不是调优项：

| 红线                              | 约束                                                                |
| --------------------------------- | ------------------------------------------------------------------- |
| 整本书进内存 / React State / DOM  | 禁止。走 Document Model → 章节索引 → 段落索引 → viewport → 虚拟渲染 |
| 主线程同步解析大文件              | 禁止。Rust 侧异步任务 + 进度事件                                    |
| 主线程同步执行 AI 调用            | 禁止。流式事件增量渲染                                              |
| JS `String.includes()` 做全文搜索 | 禁止。用 SQLite FTS5 + BM25                                         |
| 无 Benchmark 支撑的性能结论       | 禁止。所有数字必须实测                                              |
| 主 chunk 超 500 kB                | 禁止。路由级 lazy + vendor 分块（`advancedChunks`）保持告警静默     |

---

## 8. 测试策略

| 层        | 工具                     | 覆盖                                                      |
| --------- | ------------------------ | --------------------------------------------------------- |
| Rust 单元 | `cargo test`             | 解析器、章节识别、文本引擎、搜索、标注、Book Pack、数据库 |
| 前端单元  | Vitest + Testing Library | store、hooks、工具函数                                    |
| 集成      | `cargo test` + Tauri IPC | 导入、数据库、搜索、阅读器                                |
| E2E       | Playwright（Phase 3 起） | 启动 → 导入 → 阅读 → 标注 → 搜索 → 关闭 → 恢复进度        |

---

## 9. 尚未落地（后续阶段）

阶段计划（P0–P14）已全部完成。剩余项集中在下述两档；三项已于此日落地——「标注 + 书签 WebDAV 同步（墓碑）」（见「同步模型」）、「离线基础词典」（见「查词与翻译」）与「自动更新」（见下）——故 P0 只余**代码签名**一项，而它并不阻塞功能。

### P0（发布门槛）

| 主题     | 阻塞点                          | 补齐路径                                                                                                                                                                                                                                                                                                                                                                                                                                                                                     |
| -------- | ------------------------------- | -------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------- |
| 代码签名 | Apple 开发者证书 / Windows 证书 | **管线已就绪**（2026-09-22）：`release.yml` 的「Export macOS signing secrets」步骤在证书存在时把 5 个 `APPLE_*` 注入作业环境，其余由 Tauri CLI 自己走完（临时钥匙串 → `security import` → `codesign --options runtime` → `notarytool submit` + staple）。**只差证书**，步骤见下。**无证书不阻塞功能**：产物仍是 ad-hoc 签名，本地已实测可打包运行；代价只是他人首次打开要绕过一次 Gatekeeper（右键「打开」，或 `xattr -dr com.apple.quarantine`），Windows 侧是 SmartScreen 的「未知发布者」 |

#### 代码签名：接线细节

拿到 Apple 开发者证书（Developer ID Application）后，往仓库 Secrets 里填 5 个值即生效，无需再改工作流：

| Secret                       | 值                                                        |
| ---------------------------- | --------------------------------------------------------- |
| `APPLE_CERTIFICATE`          | `.p12` 的 base64：`openssl base64 -in cert.p12 \| pbcopy` |
| `APPLE_CERTIFICATE_PASSWORD` | 导出 `.p12` 时设的密码                                    |
| `APPLE_ID`                   | 开发者账号邮箱                                            |
| `APPLE_PASSWORD`             | **App 专用密码**（appleid.apple.com 生成，不是登录密码）  |
| `APPLE_TEAM_ID`              | Membership 页的 Team ID                                   |

为什么非要一个独立的导出步骤，而不是把这些变量直接写在 `tauri-action` 上：🔴 **打包器判定证书用的是 `var_os("APPLE_CERTIFICATE")`，「存在且为空」也算存在**。Secret 未配置时 `${{ secrets.X }}` 展开成空串，于是它会拿着一个空的 `.p12` 走进证书分支，`security import` 失败 → 打包失败。所以这些 Secret 在**自己的步骤**里读（步骤级 `env` 不会泄漏到后续步骤），只有确认非空时才 `>> $GITHUB_ENV`。顺带在这个步骤里做一次校验：有证书但缺公证凭据直接 `::error::` 退出 —— 签名而不公证比 ad-hoc 更糟（贴不上票，Gatekeeper 照样拦），而在 `notarytool` 内部失败时报错信息指向不到具体 Secret。

另外两条判据：① **`APPLE_SIGNING_IDENTITY` 故意不设** —— 有 `APPLE_CERTIFICATE` 时 CLI 自己从证书里取身份，而填一个对不上的名字是硬错误而非提示；② `secrets` 上下文在步骤 `if` 里不可用（只有 `env` / `vars` 等），所以「有没有配置证书」只能在 shell 里判断。

**Windows 仍未接线**，且它与 macOS 不同——那条路不看环境变量，而是配置：`bundle.windows.certificateThumbprint` + 把 `.pfx` 导进 runner 的证书存储（`signtool` 只认存储里的证书）。没有证书时**不能**预先写进 `tauri.conf.json`，否则打包会因为找不到指纹对应的证书直接失败，所以等真有 Windows 证书时再一并补。

**自动更新已落地**（2026-09-15）。机制是 Tauri 的 updater + process 两个插件：`check()` 读 `plugins.updater.endpoints` 指向的 `latest.json`（GitHub Releases 的 `releases/latest/download/` 路径），验签通过后 `downloadAndInstall()`，再 `relaunch()` 换到新版本。**它的信任根是一对自己生成的 minisign 密钥**（`pnpm tauri signer generate`；公钥钉在 `tauri.conf.json`，私钥只进 GitHub Secrets）——与 Apple / 微软证书无关，所以没有平台证书也能做。

capability 只放行实际用到的三条：`updater:allow-check`、`updater:allow-download-and-install`、`process:allow-restart` —— `relaunch()` 走的是 `plugin:process|restart`，`exit` 没有放行。**每次 launch 一次延迟检查（8 s 后）**，配 `UpdateBanner`（外壳顶层横幅，可关闭，只对「有新版」出现；检查失败不打扰任何人），这就是当初「缺一张能自己冒出来的通知面」的那个面（2026-10-12 落地）。状态住在 `stores/updater.ts`：设置的「关于」行与横幅两个写者、两个读者共享同一份状态机，谁安装都一起动。角标在全屏阅读时不绘制。**启动检查只发现、不安装**——安装永远是读者按的。

两条必须成对记住的约束：① `releaseDraft` 必须是 `false` —— GitHub 的 `releases/latest` 明确跳过草稿，草稿发布会让已安装的客户端永远查不到东西；② **私钥丢失后，已经装出去的版本再也收不到更新**（只能换密钥 + 让用户手动重装），所以它是必须先备份的机密。

### P1（高价值，中等工作量）

**已清空**（2026-09-19）。

- **StarDict `.syn` 变形词。** 同一批文件里真正被丢掉的一件：`.ifo` 里 `synwordcount=` 声明的第四个文件 `.syn`（`synonym_word\0` + 4 B 的 `.idx` 条目序号）此前既不导入也不查，于是只收 `run` 的词典划 `ran` 落空。落地方式见「查词与翻译」——记录扫描泛化后两侧共用同一个 `Index`，查词加一条支路。🔴 **此日之前导入的词典目录里没有 `variants.syn`，变形词不会追溯生效，要重新导入一次**；`.syn` 本来就比索引小一个量级，只驻留它的偏移表，整本词典的内存代价仍是 4 B/条。

**两项已于此日落地**（2026-09-15）：

- **epub 旧标注 CFI 回填。** 原本写的是「打开时批量反查落库」，实际缺口比想象的小、也更具体：`resolveAnchors` 的过滤条件是「有文本且没有 CFI」，本来就覆盖任何无锚标注，不只是 Kindle 导入。真正坏掉的只有**跳转**这一条 —— `if (annotation.cfi)` 让无锚标注点下去什么也不发生。修法是 `FoliateHandle::goToHighlight`：先用**章的 fraction** 落到那一章（不走 section 序号，因为 foliate 的 section 与导入器的章是两套编号，`rememberFoliateLocation` 那条 fraction 桥才是既有的换算），再轮询 `getContents()` 用文本铸出 CFI、落库、跳过去。铸锚用的是新抽出的 `textAnchor.ts::findInSections`，与 Kindle 导入共用 `indexText` / `findRange`。
- **自定义字体导入**（见「自定义字体」一节）。

### P2（锦上添花）

- 笔记导出到 Anki（`.apkg`）—— Obsidian 方言已落地（2026-10-12）
- 知识图谱力导向可视化深化（`GraphPanel` 已有基础）
- 金句卡片分享图 · 扫描页整本识别 · 多窗口对照 · i18n（en）

**一项已于此日落地**（2026-10-12），从上面的清单里移走：

- **快捷键自定义。** 分两步。**① 收编阅读器自己的键**：`src/features/reader/readerKeys.ts` 是一张纯表，12 条绑定各有稳定 id 与中文标题（翻章翻页 / 标尺步进 / 灯箱 / 浮层关闭），`ReaderPage` 那 105 行分支换成「搭上下文 → 解一个 id → 翻译成调用」，`readerKeys.test.ts` 把整张判定表钉住（改之前这块**一条单测都没有**，只有浏览器套件能碰到）。**② 面板**：`KeyOverrides` 写进 `useSettings`，`useHotkeys` 与 `resolveReaderKey` 每次按键现读，设置页的 `KeymapSection` 分「应用 / 阅读器」两张表列出可改的键，点「改键」按一下就换（捕获阶段录制，Escape 取消），并把改出来的问题（按不到的绑定、被两处占用的组合）显式列在「需要注意」里。`e2e/keymap.spec.ts` 走完整条链：面板写 → **刷新**（证明写进了存储而不只是面板状态）→ 打开书按新键。**面板只动 `keys`**，闸门与 `inEditable` / `keepDefault` 都跟按键无关，不该被面板改到。

### 明确不做

自建云同步、自建 AI、书源加 HTML 规则（规则语言扩张是维护陷阱）、多用户协作（与 Local First 冲突）、生词本。

**本节是「还没做」的唯一入口。** 历史清单已归档（`docs/archive/`），它们记的是每条被量过的数字
与撤回理由，不再是待办来源。

### 生产化基线（Phase 14）

- **CI**：`.github/workflows/ci.yml`（push/PR 跑 `verify` + Rust 三件套 + bundle size 摘要；e2e 前装 `fonts-noto-cjk` —— 跑批机没有中文字体时，版面度量与任何真实读者都不同）、`release.yml`（`v*` tag → tauri-action 四平台 draft release，打包前先跑 Rust 门禁）。
- **打包**：`pnpm tauri build` 本地实测产出 `ColorReader.app`（arm64，ad-hoc 签名，二进制 7.7 MB）；dmg 由 CI 产出。
- **E2E**：`pnpm test:e2e`（Playwright，**chromium + webkit 两个 project** —— 前者是开发便利，后者才是 Tauri 真正用的引擎）对 `vite preview` 的生产构建跑 **96 条**：路由 smoke（书库 → 搜索 → 设置）之外，还覆盖阅读排版与页码、PDF、Kindle 容器、书库交互、朗读与悬浮条。**两个 project 都要跑**——同一串中文字符在 WebKit 里宽约 15%，只在一个引擎上断言过的布局等于没断言。
- **Benchmark**：`cargo test --release bench -- --ignored --nocapture`（600 章 / 2.7 MB 参考书）：导入（切章 + FTS 索引）60 ms，检索均值 1.3 ms，目录加载 0.6 ms。Apple M 系列、release profile。

> 文档同步备忘：本节的 PDF 段落已据代码实际状态订正（此前写「PDF 不可标注」已失效——文字版 PDF 标注 + 划词问 AI 均已落地）；「同步模型」一节已改写为「进度 + 标注 + 书签」，P0-① 标注/书签同步随之从待办移出。
