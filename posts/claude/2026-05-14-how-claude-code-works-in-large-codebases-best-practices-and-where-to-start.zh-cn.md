# Claude Code 在大型代码库中的运作方式：最佳实践与入门指南

            **日期：** 2026-05-14 00:00 UTC
            **链接：** https://claude.com/blog/how-claude-code-works-in-large-codebases-best-practices-and-where-to-start

            ---

            /\* 博客嵌入内容与代码块的流体断行 \*/
.u-rich-text-blog .w-embed,
.u-rich-text-blog pre.w-code-block {
--max-w: 860px;
--gutter: 24px;
--available: calc(100vw - (var(--gutter) \* 2));
--w: min(var(--max-w), var(--available));
width: var(--w);
max-width: var(--w);
margin-left: calc((640px - var(--w)) / 2);
margin-right: calc((640px - var(--w)) / 2);
box-sizing: border-box;
}
@media (max-width: 720px) {
.u-rich-text-blog .w-embed,
.u-rich-text-blog pre.w-code-block {
width: 100%;
max-width: 100%;
margin-left: 0;
margin-right: 0;
}
/\* 限制文章列宽为视口宽度，防止内容溢出页面 \*/
.blog\_post\_layout.u-column-custom,
.blog\_post\_content\_wrap,
.u-rich-text-blog {
max-width: 100% !important;
box-sizing: border-box;
}
html,
body {
overflow-x: hidden;
}
}
/\* 嵌入内部包装器：内容溢出时水平滚动 \*/
.u-rich-text-blog .w-embed figure {
width: 100% !important;
max-width: 100% !important;
margin: 0 !important;
}
.u-rich-text-blog .w-embed figure > div {
width: 100% !important;
max-width: 100% !important;
overflow-x: auto !important;
-webkit-overflow-scrolling: touch;
}
/\* 表格：宽屏固定比例，移动端自然宽度加滚动 \*/
.u-rich-text-blog .w-embed table {
width: 100% !important;
table-layout: fixed !important;
}
.u-rich-text-blog .w-embed table th:nth-child(1),
.u-rich-text-blog .w-embed table td:nth-child(1) {
width: 22%;
}
.u-rich-text-blog .w-embed table th:nth-child(2),
.u-rich-text-blog .w-embed table td:nth-child(2) {
width: 39%;
}
.u-rich-text-blog .w-embed table th:nth-child(3),
.u-rich-text-blog .w-embed table td:nth-child(3) {
width: 39%;
}
.u-rich-text-blog .w-embed td code,
.u-rich-text-blog .w-embed th code {
overflow-wrap: anywhere;
word-break: break-word;
white-space: normal;
}
@media (max-width: 639px) {
.u-rich-text-blog .w-embed table {
width: auto !important;
min-width: 640px !important;
table-layout: auto !important;
}
.u-rich-text-blog .w-embed table th,
.u-rich-text-blog .w-embed table td {
min-width: 0 !important;
width: auto !important;
}
}
/\* 代码块 \*/
.u-rich-text-blog pre.w-code-block {
overflow-x: auto;
-webkit-overflow-scrolling: touch;
}
@media (max-width: 639px) {
.u-rich-text-blog pre.w-code-block {
font-size: 0.82rem;
}
}
/\* 5列对比表格（例如 Claude Code 组件）
通过 :has() 限定作用域，避免影响上述3列表格。 \*/
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) {
font-size: var(--\_typography---font-size--body-3);
line-height: 1.55;
}
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) th,
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) td {
font-size: var(--\_typography---font-size--body-3);
line-height: 1.55;
padding: 16px 18px;
overflow-wrap: anywhere;
word-break: normal;
hyphens: none;
vertical-align: top;
}
/\* 列比例：组件 | 是什么 | 加载时机 | 最佳用途 | 常见混淆 \*/
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) th:nth-child(1),
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) td:nth-child(1) {
width: 16%;
}
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) th:nth-child(2),
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) td:nth-child(2) {
width: 21%;
}
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) th:nth-child(3),
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) td:nth-child(3) {
width: 15%;
}
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) th:nth-child(4),
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) td:nth-child(4) {
width: 24%;
}
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) th:nth-child(5),
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) td:nth-child(5) {
width: 24%;
}
@media (max-width: 639px) {
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) th,
.u-rich-text-blog .w-embed table:has(thead tr th:nth-child(5)) td {
padding: 12px 14px;
line-height: 1.5;
}
}

Claude Code 正在数百万行级别的单体仓库、数十年的遗留系统、横跨数十个仓库的分布式架构以及拥有数千名开发者的组织中投入生产使用。这些环境带来了较小、较简单的代码库所不具备的挑战——无论是每个子目录下各不相同的构建命令，还是分布在多个文件夹中且没有共享根目录的遗留代码。

本文涵盖了我们在大规模成功采用 Claude Code 过程中观察到的模式。我们用“大型代码库”来指代广泛的部署场景：拥有数百万行代码的单体仓库、历经数十年构建的遗留系统、横跨多个独立仓库的数十个微服务，或以上任意组合。这还包括团队不常与 AI 编码工具关联的语言所运行的代码库，例如 C、C++、C#、Java、PHP。（在这些情况下，Claude Code 的表现通常超出大多数团队的预期，尤其是在最近的模型版本中。）虽然每个大型代码库的部署都受到其特定版本控制、团队结构和积累的惯例的影响，但本文中的模式可以推广到大多数场景，并且是考虑采用 Claude Code 的团队的良好起点。

## Claude Code 如何导航大型代码库

Claude Code 导航代码库的方式与软件工程师相同：它遍历文件系统、读取文件、使用 grep 精确查找所需内容，并跨代码库追踪引用。它在开发者的本地机器上运行，不需要构建、维护或上传代码库索引到服务器。

基于 RAG 的 AI 编码工具通过嵌入整个代码库并在查询时检索相关片段来工作。在大规模场景下，这些系统可能会失败，因为嵌入管道无法跟上活跃工程团队的步伐。当开发者查询索引时，它反映的是数周、数天甚至数小时前存在的代码库状态。然后检索会返回一个团队两周前重命名的函数，或引用一个在上一个冲刺中删除的模块，而没有任何迹象表明这些信息已过时。

代理搜索避免了这些失败模式。当数千名工程师提交新代码时，无需维护嵌入管道或集中索引。每个开发者的实例都基于实时代码库工作。

但这种方法有一个权衡：当 Claude 有足够的起始上下文知道从哪里开始查找时，它才能发挥最佳效果。这意味着 Claude 的导航质量取决于代码库的配置方式，通过 CLAUDE.md 文件和技能来分层构建上下文。如果你要求它在拥有数十亿行代码的代码库中查找所有模糊模式的实例，你会在工作开始之前就触及上下文窗口的限制。那些在代码库配置上投入的团队会看到更好的结果。

## 工具链与模型本身同样重要

关于 Claude Code 最常见的误解之一是，其能力完全由所使用的模型决定。团队关注模型的基准测试及其在测试任务上的表现。实际上，围绕模型构建的生态系统——即工具链——对 Claude Code 性能的决定性作用超过了模型本身。

工具链由五个扩展点构建而成——CLAUDE.md 文件、钩子、技能、插件和 MCP 服务器——每个都服务于不同的功能。团队构建它们的顺序很重要，因为每一层都建立在前一层的基础上。另外两个能力，LSP 集成和子代理，完善了整个配置。下面，我们解释这些组件和能力各自的作用：

[**CLAUDE.md**](https://code.claude.com/docs/en/memory) **文件是首要的。** 这些是 Claude 在每个会话开始时自动读取的上下文文件：根文件用于全局概览，子目录文件用于局部约定。它们为 Claude 提供了做好任何事情所需的代码库知识。由于无论任务如何，它们都会在每个会话中加载，因此保持它们聚焦于广泛适用的内容可以防止它们成为性能的拖累。

[**钩子**](https://code.claude.com/docs/en/hooks-guide) **使配置能够自我改进。** 大多数团队将钩子视为防止 Claude 做错事的脚本，但它们更有价值的用途是持续改进。一个停止钩子可以反思会话期间发生的事情，并在上下文仍然新鲜时提出 CLAUDE.md 更新。一个启动钩子可以动态加载团队特定的上下文，这样每个开发者无需手动配置就能获得其模块的正确设置。对于像代码检查和格式化这样的自动化检查，钩子可以确定性地执行规则，并产生比依赖 Claude 记住指令更一致的结果。

[**技能**](https://code.claude.com/docs/en/skills) **在不使每个会话臃肿的情况下，按需保持正确的专业知识可用。** 在一个包含数十种任务类型的大型代码库中，并非所有专业知识都需要在每个会话中出现。技能通过[渐进式披露](https://platform.claude.com/docs/en/agents-and-tools/agent-skills/best-practices)解决了这个问题，将原本会争夺上下文空间的专业工作流和领域知识卸载，仅在任务需要时才加载。例如，当 Claude 评估代码漏洞时，会加载一个安全审查技能；而当进行代码更改并需要更新文档时，则会加载一个文档处理技能。

技能还可以限定到特定路径，以便它们仅在代码库的相关部分激活。拥有支付服务的团队可以将其部署技能绑定到该目录，这样当其他人在单体仓库的其他地方工作时，它就不会自动加载。

[**插件**](https://code.claude.com/docs/en/plugins) **分发有效的配置。** 大型代码库的一个挑战是，*好的*配置可能局限于小圈子。一个插件将技能、钩子和 MCP 配置打包成一个可安装的包，这样当新工程师在第一天安装该插件时，他们将立即拥有与已经使用 Claude 的人相同的上下文和能力。插件更新可以通过[托管市场](https://support.claude.com/en/articles/13837433-manage-claude-cowork-plugins-for-your-organization)在整个组织内分发。

例如，我们合作的一家大型零售组织构建了一个技能，将 Claude 连接到他们的内部分析平台，这样业务分析师无需离开工作流程即可拉取绩效数据。在向业务部门广泛推广之前，他们将其作为插件分发。

**语言服务器协议（LSP）集成赋予 Claude 与开发者在 IDE 中相同的导航能力。** 大多数大型代码库的 IDE 已经在运行 LSP，为“转到定义”和“查找所有引用”提供支持。将这一点提供给 Claude 使其具备符号级别的精度：它可以跟踪函数调用到其定义，跨文件追踪引用，并区分不同语言中同名函数。没有它，Claude 会在文本上进行模式匹配，并可能定位到错误的符号。我们合作的一家企业软件公司在推广 Claude Code 之前，就在全组织范围内部署了 LSP 集成，专门是为了使 C 和 C++ 的导航在大规模下变得可靠。对于多语言代码库，这是最有价值的投入之一。

**MCP 服务器扩展一切。** MCP 服务器是 Claude 连接到其无法直接访问的内部工具、数据源和 API 的方式。最成熟的团队构建了 MCP 服务器，将结构化搜索作为 Claude 可以直接调用的工具暴露出来。其他人则将 Claude 连接到内部文档、工单系统或分析平台。

[**子代理**](https://code.claude.com/docs/en/sub-agents) **将探索与编辑分离。** 子代理是一个独立的 Claude 实例，拥有自己的上下文窗口，它接受一个任务、完成工作，并仅将最终结果返回给父代理。一旦工具链就位，一些团队会启动一个只读子代理来映射一个子系统并将发现写入文件，然后让主代理在掌握全局情况后进行编辑。

*Claude Code 扩展层概览。*

下表总结了每个组件的作用、加载时机以及我们看到的每个组件最常见的错误：

| 组件 | 是什么 | 加载时机 | 最佳用途 | 常见混淆 |
| --- | --- | --- | --- | --- |
| CLAUDE.md | Claude 自动读取的上下文文件 | 每个会话 | 项目特定约定、代码库知识 | 将其用于应属于技能的可复用专业知识 |
| 钩子 | 在关键时刻运行的脚本 | 由事件触发 | 自动化一致的行为、捕获会话学习成果 | 使用提示词来做应该自动运行的事情 |
| 技能 | 针对特定任务类型的打包指令 | 按需，相关时 | 跨会话和项目的可复用专业知识 | 将所有内容加载到 CLAUDE.md 中 |
| 插件 | 打包的技能、钩子、MCP 配置 | 配置后始终可用 | 在整个组织内分发有效的配置 | 让好的配置局限于小圈子 |
| 语言服务器协议（LSP）\* | 通过特定语言服务器提供的实时代码智能 | 配置后始终可用 | 在类型化语言中进行符号级导航和自动错误检测 | 假设它是自动的 |
| MCP 服务器 | 连接外部工具和数据的通道 | 配置后始终可用 | 让 Claude 访问其无法直接访问的内部工具 | 在基础功能正常工作之前就构建 MCP 连接 |
| 子代理\* | 用于特定任务的独立 Claude 实例 | 被调用时 | 将探索与编辑分离、并行工作 | 在同一会话中运行探索和编辑 |
| \*LSP 通过插件层访问。子代理是一种委派能力，而非配置的扩展点。 | | | | |

## 来自成功部署的三种配置模式

如何为大型代码库配置 Claude Code 在很大程度上取决于该代码库的结构。尽管如此，在我们观察到的部署中，有三种模式始终如一地出现。

### 使代码库在大规模下可导航

Claude 在大型代码库中提供帮助的能力受限于它找到正确上下文的能力。在每个会话中加载过多上下文会降低性能，而上下文太少则会让 Claude 盲目导航。最高效的部署会预先投入，使代码库对 Claude 来说易于理解。以下几种模式始终如一地出现：

* **保持 CLAUDE.md 文件精简且分层。** Claude 在遍历代码库时增量加载它们：根文件用于全局概览，子目录文件用于局部约定。根文件应该只包含指针和关键注意事项；其他所有内容都会变成噪音。
* **在子目录中初始化，而不是在仓库根目录。** Claude 在限定于任务实际相关的代码库部分时表现最佳。在单体仓库中，这可能会感觉违反直觉，因为工具通常假设根目录访问，但 Claude 会自动向上遍历目录树并加载沿途找到的每个 CLAUDE.md 文件，因此根级上下文永远不会丢失。
* **按子目录限定测试和代码检查命令的范围。** 当 Claude 更改了一个服务时运行完整的测试套件会导致超时，并在无关输出上浪费上下文。子目录级别的 CLAUDE.md 文件应指定适用于该部分代码库的命令。这对于每个目录都有自己的测试和构建命令的服务导向型代码库效果很好。在具有深层跨目录依赖关系的编译型语言单体仓库中，按子目录限定范围更难实现，可能需要特定于项目的构建配置。
* **使用 `.`**`ignore` **文件排除生成的文件、构建产物和第三方代码。** 在 `.claude/settings.json` 中提交 `permissions.deny` 规则意味着排除项是版本控制的，因此团队中的每个开发者无需自行配置即可获得相同的噪音减少效果。在某些代码库中，生成的文件本身就是开发工作的主题。从事代码生成器工作的开发者可以在其本地设置中覆盖项目级别的排除项，而不会影响团队其他成员。
* **当目录结构无法完成工作时，构建代码库地图。** 对于代码未整合到传统目录结构中的组织，在仓库根目录创建一个轻量级的 markdown 文件，列出每个顶级文件夹并附上一行描述，为 Claude 提供一个在打开文件前可以扫描的目录表。对于拥有数百个顶级文件夹的代码库，这最好作为分层方法使用：根文件仅描述最高级别的结构，而子目录 CLAUDE.md 文件提供下一级细节，在 Claude 遍历树时按需加载。对于更简单的情况，@-提及 Claude 应引用的特定文件或目录可以达到相同效果。
* **运行 LSP 服务器，以便 Claude 按符号而非字符串搜索。** 在大型代码库中 grep 一个常见的函数名会返回数千个匹配项，Claude 会消耗上下文打开文件来确定哪个重要。LSP 仅返回指向同一符号的引用，因此过滤发生在 Claude 读取任何内容之前。设置此功能需要为你的语言安装一个[代码智能插件](https://code.claude.com/docs/en/discover-plugins#code-intelligence)和相应的语言服务器二进制文件；Claude Code 文档涵盖了可用的插件和故障排除。

**一个注意事项**：存在一些边缘情况，即使分层 CLAUDE.md 方法也会失效，例如拥有数十万个文件夹和数百万个文件的代码库，或使用非 Git 版本控制的遗留系统。我们将在本系列的后续文章中讨论它们的挑战。对于遗留系统，请参阅 AI 如何[*打破 COBOL 现代化的成本壁垒*](https://claude.com/blog/how-ai-helps-break-cost-barrier-cobol-modernization)。

### 随着模型智能的演进主动维护 CLAUDE.md 文件

随着模型的演进，为当前模型编写的指令可能会对未来的模型产生反作用。那些曾引导 Claude 克服过去难以处理的模式的 CLAUDE.md 文件，在下一次模型发布时可能变得不必要，甚至成为主动约束。例如，一个告诉 Claude 将每次重构分解为单文件更改的 CLAUDE.md 规则，可能帮助了早期模型保持正轨，但会阻止新模型进行它能够很好处理的协调性跨文件编辑。

为弥补特定模型限制（无论是模型推理方面的限制，还是 Claude Code 自身工具的限制）而构建的技能和钩子，一旦这些限制不再存在，就会变成开销。例如，一个拦截文件写入以在 Perforce 代码库中强制执行 p4 edit 的钩子，在 Claude Code 添加了原生 Perforce 模式后就变得多余了。

团队应预计每三到六个月进行一次有意义的配置审查，但在主要模型发布后，如果感觉性能停滞不前，也值得进行一次审查。

### 为 Claude Code 管理和采用分配所有权

仅靠技术配置并不能推动采用。做得好的组织也在组织层面进行了投入。

传播最快的推广活动在广泛访问之前都有专门的基础设施投入。一个小团队，有时甚至只有一个人，连接好工具，使得 Claude 在开发者第一次接触时就已经适合他们的工作流程。在一家公司，几个工程师构建了一套插件和 MCP，在第一天就可用。在另一家公司，一个专注于管理 AI 编码工具的整个团队在推广开始前就已经将基础设施部署到位。在这两种情况下，开发者的第一次体验都是富有成效而非令人沮丧的，采用率从此开始传播。

今天从事这项工作的团队通常隶属于开发者体验或开发者生产力部门，这通常是负责入职新工程师和构建开发者工具的职能部门。在几个组织中，一个新兴的角色是代理经理：一个混合了产品经理/工程师职能的角色，专门负责管理 Claude Code 生态系统。对于没有专门团队的组织，最低可行版本是一个 DRI：一个人拥有 Claude Code 配置的所有权，有权对设置、权限策略、插件市场和 CLAUDE.md 约定做出决策，并有责任保持它们的最新状态。

自下而上的采用可以产生热情，但如果没有人来集中整合有效的东西，就会导致碎片化。你需要有一个个人或团队来汇编和推广正确的 Claude Code 约定（例如标准化的 CLAUDE.md 层级结构或一套精选的技能和插件）。没有这项工作，知识将局限于小圈子，采用率将停滞不前。

在大型组织中，尤其是受监管行业，治理问题会早早出现，例如：谁控制哪些技能和插件可用？如何防止数千名工程师独立重建相同的东西？如何确保 AI 生成的代码经历与人类编写的代码相同的审查流程？为了尽早解决这些问题，我们建议从一组定义的批准技能、必需的代码审查流程和有限的初始访问权限开始，并随着信心的建立而扩展。

我们观察到，在那些早期就建立跨职能工作组的组织中，部署最为顺利——这些工作组汇集了工程、信息安全和管理代表，共同定义需求并制定推广路线图。

## 将这些模式应用于你的组织

Claude Code 是围绕传统的软件工程环境设计的，其中工程师是代码库的主要贡献者，仓库使用 Git，代码遵循标准目录结构。大多数大型代码库符合这种模式，但非传统设置——例如包含大型二进制资产的游戏引擎、具有非传统版本控制的环境或非工程师贡献代码的代码库——需要额外的配置工作。我们的指导假设一个传统设置，并且我们描述的模式已在我们的许多客户中奏效。任何剩余的复杂性都需要根据你的特定代码库、工具和组织进行判断。这就是 Anthropic 的应用 AI 团队直接与工程团队合作，将这些模式转化为你组织的特定需求的地方。

*开始使用* [*Claude Code for Enterprise*](https://claude.com/product/claude-code/enterprise)*。*

‍

***致谢：** 特别感谢来自 Anthropic 应用 AI 团队的 Alon Krifcher、Charmaine Lee、Chris Concannon、Harsh Patel、Henrique Savelli、Jason Schwartz、Jonah Dueck 和 Kirby Kohlmorgen 分享他们在大规模部署 Claude Code 方面的经验，以及感谢 Zoox 的 Amit Navindgi 为本文提供反馈。*

‍
