# 你的专属“钢铁侠”助手OS Agents来了！浙大联手OPPO、零一万物等10个机构推出全新综述

文章作者: 量子位
发布时间: 2025-01-03 15:31
发布地: 北京
原文链接: http://mp.weixin.qq.com/s?__biz=MzIzNjc1NzUzMw==&mid=2247771009&idx=4&sn=e83ac5b2419ba043fb7fcee683f95c9f&chksm=e8dc14f3dfab9de576220ef02b3af0bbe762fd4a9b6beecb4d004d5bf278653725e1ef8834c2#rd

封面图链接: https://mmbiz.qpic.cn/mmbiz_jpg/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqaHBXBXcoJHAgjFARxV5xuNHORwPS4s5at1GkoQTKfMCA9BroQGUNOQ/300

##### OS Agents团队 投稿  
量子位 | 公众号 QbitAI

电影《钢铁侠》中，托尼·斯塔克的助手贾维斯（J.A.R.V.I.S.）能帮他控制各种系统并自动完成任务，曾让无数观众羡慕不已。

现在，这样的超级智能助手，终于变成现实了！

随着多模态大语言模型的爆发式进化，**OS Agents** 横空出世，它们能无缝操控电脑和手机，为你自动搞定繁琐任务。

从Anthropic的Computer Use，到苹果的Apple Intelligence，再到智谱AI的AutoGLM，以及Google
DeepMind的Project Mariner，科技巨头们的野心都指向了同一个目标：**打造真正意义上的操作系统智能助手** 。

OS Agents 已经不仅仅是“助手”，它们正在改写“人机交互”的游戏规则。

最近，**浙江大学** 联手**OPPO、零一万物** 等十个机构共同梳理了一篇综述文章《OS Agents: A Survey on MLLM-based
Agents for General Computing Devices Use》，不仅详细解读了OS
Agents的硬核技术构造，还盘点了它们的评估方法和未来挑战。

**科技行业的下一个新风口，会是OS Agents吗？**

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqvR7zK4KQDWzHQlU72JrNp6zWgdUZ0bRvVpbcIQ3wXywr0jvU7bdR2A/640?wx_fmt=png&from=appmsg)

## OS Agents商业学术同时迸发

像贾维斯这样的超级AI助手，一般被称为**OS Agents**
，它们能够通过操作系统（OS）提供的环境和接口（如图形用户界面，GUI），在诸如电脑或者手机等计算设备上自动化的完成各类任务。

OS
Agents有巨大的潜力改善全球数十亿用户的生活，想象一个世界：在线购物、预订差旅等日常活动都可以由这些智能体无缝完成，这将大幅提高人们的生活效率和生产力。

过去，诸如Siri[1]、Cortana[2]和Google
Assistant[3]等AI助手，已经展示了这一潜力。然而，由于模型能力在过去较为有限，导致这些产品只能完成有限的任务。

幸运的是，随着多模态大语言模型的不断发展，如Gemini[4] 、GPT[5] 、Grok[6] 、Yi[7] 和Claude[8]
系列模型（排名根据2024年12月22日更新的 Chatbot Arena LLM Leaderboard[9]），这一领域迎来了新的可能性。

(M)LLMs展现出令人瞩目的能力，使得OS Agents能够更好地理解复杂任务并在计算设备上执行。

基础模型公司和手机厂商近期在这一领域动作频频，例如最近由Anthropic推出的Computer Use[10]、由苹果公司推出的Apple
Intelligence[11]、由智谱AI推出的AutoGLM[12]和由Google DeepMind推出的Project Mariner [13]。

其中，Computer Use利用Claude[14]与用户的计算机直接互动，可以实现无缝的任务自动化。

与此同时，学术界已经提出了各种方法来构建基于(M)LLM的OS Agents。

例如，OS-Atlas[15]提出一种 GUI 基础模型，通过跨多个平台综合 GUI 操作数据，大幅改进了模型对 GUI 的操作能力，提升OOD任务的表现。

而OS-Copilot[16]则是一种OS
Agents框架，能够使智能体在少监督情况下实现广泛的计算机任务自动化，并展示了其在多种应用中的泛化能力和自我改进能力。

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqPfgCfup4IFQaoiccG1f3WmGXgwF5wI2f8IqTVsib8w7fZoJySPXtpLibQ/640?wx_fmt=png&from=appmsg)

###### **△** OS Agents的部分代表性商业产品与学术研究

本文是对OS Agents进行的一次全面综述。

首先阐明OS Agents的基础，探讨了其关键要素，包括环境、观察空间和动作空间，并概述了理解、规划和执行操作等核心能力。

接着，审视了构建OS Agents的方法，重点关注OS Agents领域特定的基础模型和智能体框架的开发。

随后，文章详细回顾了评估协议和基准测试，展示了OS Agents在多种任务中的评估方式。

最后，文章讨论了当前的挑战并指出未来研究的潜在方向，包括安全与隐私、个性化与自我进化。

本文旨在梳理OS Agents研究的现状，为学术研究和工业开发提供帮助。

为了进一步推动该领域的创新，团队还维护了一个开源的GitHub仓库，包含250+有关OS
Agents的论文以及其他相关资源，并且仍在持续更新中。（链接在文章末尾～）

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqEdtm6VhoUfcBSkq6vLmIbib361mSPkonfv6V3jRSaJJytjWssSib42Hw/640?wx_fmt=png&from=appmsg)

###### **△** OS Agents基础：关键要素和核心能力

## OS Agents基础

### 关键要素 (Key Component)

要实现 OS Agents 对计算设备的通用控制，需要通过与操作系统提供的环境、输入和输出接口进行交互来完成目标。

为满足这种交互需求，现有的 OS Agents 依赖三个关键要素：

  * **环境（Environment）** ：智能体操作的系统或平台，例如电脑、手机和浏览器。环境是智能体完成任务的舞台，支持从简单的信息检索到复杂的多步骤操作。

  * **观察空间（Observation Space）** ：智能体可获取的所有信息范围。这些信息诸如屏幕截图、文本描述或GUI界面结构，是智能体理解环境和任务的基础。例如，网页的 HTML 代码或手机的屏幕截图。

  * **动作空间（Action Space）** ：智能体与环境交互的动作集合。它定义了可执行的操作，如点击、输入文本、导航操作甚至调用外部工具。这使得智能体能够自动化完成任务并优化工作流。

### 核心能力 (Capability)

在OS Agents的这些关键要素后，如何与操作系统正确、有效的交互，这就需要考验OS Agents自身各方面的能力。

OS Agents必须掌握的核心能力可以总结为如下三点：

  * **理解（Understanding）** ：OS Agents 首先需要理解复杂的操作环境。无论是 HTML 代码、屏幕截图，还是屏幕界面中密集的图标和文本信息，智能体都需要**通过理解能力提取关键内容** ，构建对任务和环境的全面认知。这种理解能力是处理信息检索等任务的前提。

  * **规划（Planning）** ：在任务执行中，OS Agents 的规划能力至关重要。规划能力要求OS Agents将复杂任务**拆解** 为多个子任务，并制定操作**序列** 来实现目标。同时，它们最好还要能够据环境变化**动态调整** 计划，以适应复杂的操作系统环境，例如动态网页和实时更新的用户屏幕界面。

  * **操作（Grounding）** ：OS Agents最终需要将规划转化为具体的、可执行的操作，例如点击按钮、输入文本或调用 API。这种将规划“落地”的能力使得它们能够在真实环境中高效完成任务，并实现从文字描述到操作执行的精准转换。

## OS Agents的构建

### 基础模型 (Foundation Model)

要构建能够高效执行任务的 OS Agents ，其核心在于开发适配的基础模型。

这些模型不仅需要理解复杂的屏幕界面，还要在**多模态场景** 下执行任务。

下面是对基础模型的架构与训练策略的详细归纳与总结：

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqAPdxNEcMjnHAuDhiasoksFc1YDK7Kaiaf3enCdaHNsaH3dA4oleverXw/640?wx_fmt=png&from=appmsg)

###### **△** OS Agents基础模型：架构、预训练、监督微调和强化学习

**架构（Architecture）** ：我们将主要的模型架构分为四个类别：1、**Existing LLMs**
：直接采用开源的大语言模型架构，将结构化的屏幕界面信息以文本形式输入给LLMs，从而使得模型可以感知环境；2、**Existing MLLMs**
：直接采用开源的多模态大语言模型架构，整合文本和视觉处理能力，提升对GUI的理解能力，减少文本化视觉信息而造成的特征损失；3、 **Concatenated
MLLMs** ：由LLM与视觉编码器桥接而成，灵活性更高，可以根据任务需求选择不同的语言模型和视觉模型进行组合；4、**Modified MLLMs**
：对现有 MLLM 架构进行优化调整，以解决特定场景的挑战，如：添加额外模块（高分辨率视觉编码器或图像分割模块等），以更细致地感知和理解屏幕界面细节。

**预训练（Pre-training）**
：预训练为模型构建打下基础，通过海量数据提升对屏幕界面的理解能力。数据源包括公共数据集、合成数据集；预训练任务覆盖屏幕定位（Screen
Grounding）、屏幕理解（Screen Understanding）与光学字符识别（OCR）等。

**监督微调（Supervised Fine-tuning）** ：监督微调让模型更贴合 GUI 场景，是提升OS
Agents规划能力和执行能力的重要手段。例如，通过记录任务执行轨迹生成训练数据，或利用 HTML 渲染屏幕界面细节，提升模型对不同 GUI 的泛化能力。

**强化学习（Reinforcement Learning）** ：现阶段的强化学习实现了用(M)LLMs作为特征提取到(M)LLM-as-
Agent的范式转变，帮助了OS
Agents在动态环境中交互，根据奖励反馈，不断优化决策。这种方法不仅提升了智能体的对齐程度，还为视觉和多模态智能体提供了更强的泛化能力与任务适配性。

近期OS Agents基础模型的相关论文总结如下：

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqdolmQoJxFXaIE7XrmlLNuJvgZagANV3JLVyB04JWK6JyPCT6AzxIMw/640?wx_fmt=png&from=appmsg)

###### **△** OS Agents基础模型近期研究工作总结

### 智能体框架 (Agent Framework)

OS Agents 除了需要强大的基础模型，还需要搭配上Agent框架来增强**感知、规划、记忆和行动** 能力。

这些模块协同工作，使 OS Agents 能够高效应对复杂的任务和环境。

以下是OS Agents框架中四大关键模块的总结归纳：

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqSU1x8Z0Gpn76S73fYgFdbOLAT9zQmoRTvhiaz3ricMT0lhQmkEKBR7PQ/640?wx_fmt=png&from=appmsg)

###### **△** OS Agents框架：感知、规划、记忆和行动

**感知（Perception）** ：感知作为OS Agents 的“眼睛”，通过输入的多模态数据（如屏幕截图、HTML
文档）观察环境。我们将感知细分为：1、文本感知：将操作系统的状态转化为结构化文本描述，如 DOM 树或 HTML
文件；2、屏幕界面感知：使用视觉编码器对屏幕界面截图进行理解，通过视觉定位（如按钮、菜单）和语义连接（如 HTML 标记）精准识别关键元素。

**规划（Planning）** ：规划作为OS Agents
的“大脑”，负责制定任务的执行策略，可以分为：1、全局规划：一次生成完整计划并执行；2、迭代规划：随着环境变化动态调整计划，使智能体能够适应实时更新的屏幕界面和任务需求。

**记忆（Memory）** ：OS
Agents框架的“记忆”部分可以帮助存储任务数据、操作历史和环境状态。记忆分为三个类型：1、内部记忆（Internal
Memory）：存储操作历史、屏幕截图、状态数据和动态环境信息，支持任务执行的上下文理解和轨迹优化。例如，借助截图解析屏幕界面布局或根据历史操作生成决策；2、外部记忆（External
Memory）：提供长期知识支持，例如通过调用外部工具（如 API）或知识库获取领域背景知识，辅助复杂任务的决策；3、特定记忆（Specific
Memory）：聚焦于特定任务的知识和用户需求，例如存储子任务分解方法、用户偏好或屏幕界面交互功能，提供高度针对性的操作支持。此外，我们还总结了多种记忆优化策略。

**行动（Action）** ：我们将OS Agents 的行动范围定义为动作空间，这包含操作系统交互的方式，我们将其细分为三个类别：1、输入操作：输入是
OS Agents 与数字屏幕界面交互的基础，主要包括鼠标操作、触控操作和键盘操作；2、导航操作：使 OS Agents
能够探索和移动于目标平台，获取执行任务所需的信息；3、扩展操作：突破了传统屏幕界面交互的限制，为智能体提供更灵活的任务执行能力，例如：代码执行与API
调用。

近期有关OS Agents框架的论文总结如下：

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavqYianqBXB0su1GOX1tia1ktBQS2yH3WTBvFGREAjicnJpG9yjph2ldS4Ag/640?wx_fmt=png&from=appmsg)

###### **△** OS Agents框架近期研究工作总结

## OS Agents的评估

在 OS Agents 的发展中，科学的评估起到了关键作用，帮助开发者衡量智能体在各种场景中的性能。

下面的表格总结了近期有关**OS Agents评估基准** 的论文：

![](https://mmbiz.qpic.cn/mmbiz_png/YicUhk5aAGtCdkzDUs2IRw5MejnsYWavq2iaKydTVnKrs5kh69XdBjibibGqujdXFTN9hEmicY9IZzqluaicOhwYoXpA/640?wx_fmt=png&from=appmsg)

###### **△** OS Agents Benchmark近期研究工作总结

### 评估协议 (Evaluation Protocol)

操作系统智能体评估的核心可总结为两个关键问题：评估过程应如何进行与需要对哪些方面进行评估。

下面本文将围绕这两个问题，阐述操作系统智能体的评估原则和指标。

  * **评估原则（Evaluation Principle）** ：OS Agents 的评估结合了多维度的技术方法，提供对其能力与局限性的全面洞察，主要分为两种类型：1、客观评估（Objective Evaluation）：通过标准化的数值指标，评估智能体在特定任务中的性能。例如，操作的准确性、任务的成功率以及语义匹配的精准度。这样的评估方法能快速且标准化地衡量智能体的性能；2、主观评估（Subjective Evaluation）：基于人类用户的主观感受，评估智能体的输出质量，包括其相关性、自然性、连贯性和整体效果。越来越多的研究也利用(M)LLM-as-Judge来进行评估，从而提高效率和一致性。

  * **评估指标（Evaluation Metric）** ：评估指标聚焦于 OS Agents 的理解、规划和操作能力，衡量其在不同任务中的表现。主要包括以下两个方面：1、步骤级指标：评估智能体在每一步操作中的准确性，如任务执行中动作的语义匹配程度、操作准确性等；2、任务级指标：聚焦于整个任务完成情况，包括任务的成功率和完成任务的效率。

### 评估基准 (Evaluation Benchmark)

为了全面评估 OS Agents 的性能，研究者开发了多种评估基准，涵盖不同平台、环境设置和任务类别。

这些基准测试为衡量智能体的跨平台适应性、动态任务执行能力提供了科学依据。

**评估平台（Evaluation Platform）**
：评估平台构建了集成的评估环境，不同平台具有独特的挑战和评估重点，我们将其主要分为三类：移动平台（Mobile）、桌面平台（Desktop）与网页平台（Web）。

**基准设置（Benchmark Setting）** ：该部分将 OS Agents
的评估环境分为两大类：静态（Static）环境和交互式（Interactive）环境，并进一步将交互式环境细分为模拟（Simulated）环境和真实世界（Real-
World）环境。静态环境适用于基础任务的离线评估，而交互式环境（尤其是真实世界环境）更能全面测试OS
Agents在复杂动态场景中的实际能力。真实世界环境强调泛化能力和动态适应性，是未来评估的重要方向。

**任务（Task）** ：为了全面评估OS
Agents的能力，当前的基准测试整合了各种专业化任务，涵盖从系统级任务（如安装和卸载应用程序）到日常应用任务（如发送电子邮件和在线购物）。主要可以分为以下三类：1、GUI
定位（GUI Grounding）：评估OS
Agents将指令转换为屏幕界面操作的能力，即如何在操作系统中与指定的可操作元素交互；2、信息处理（Information Processing）：评估OS
Agents高效处理和总结信息的能力，尤其在动态和复杂环境中，从大量数据中提取有用信息；3、智能体任务（Agentic Tasks）：评估OS
Agents的核心能力，如规划和执行复杂任务的能力。这类任务为智能体提供目标或指令，要求其在没有显式指导的情况下完成任务。

## 挑战与未来

本部分讨论了 OS Agents 面临的主要挑战及未来发展的方向，重点聚焦于安全与隐私（Safety &
Privacy）以及个性化与自我进化（Personalization & Self-Evolution）两个方面。

### 安全与隐私

安全与隐私是OS Agents开发中必须重视的领域。

OS Agents 面临多种攻击方式，包括间接提示注入攻击、恶意弹出窗口和对抗性指令生成，这些威胁可能导致系统执行错误操作或泄露敏感信息。

尽管目前已有适用于LLMs的安全框架，但针对OS Agents的防御机制仍显不足。

当前研究主要集中于设计专门应对注入攻击和后门攻击等特殊威胁的防御方案，急待开发全面的且可扩展防御框架，以提升 OS Agents 的整体安全性和可靠性。

为评估OS Agents在不同场景下的鲁棒性，还引入了一些智能体安全基准测试，用于全面测试和改进系统的安全表现，例如ST-
WebAgentBench[17]和MobileSafetyBench[18]。

### 个性化与自我进化

个性化OS Agents需要**根据用户偏好不断调整行为和功能** 。

多模态大语言模型正逐步支持理解用户历史记录和动态适应用户需求，OpenAI的Memory功能[19]在这一方向上已经取得了一定进展。

让智能体通过用户交互和任务执行过程持续学习和优化，从而提升个性化程度和性能。

未来将记忆机制扩展到**更复杂的形式** ，如音频、视频、传感器数据等，从而提供更高级的预测能力和决策支持。

同时，支持用户数据驱动的自我优化，增强用户体验。

## 总结

多模态大语言模型的发展为操作系统智能体（OS Agents）创造了新的机遇，使得实现先进AI助手的想法更加接近现实。

本综述旨在概述OS Agents的基础，包括其关键组成部分和能力。

此外，文章还回顾了构建OS Agents的多种方法，特别关注领域特定的基础模型和智能体框架。

在评估协议和基准测试中，团队成员细致分析了各类评估指标，并且将基准测试从环境、设定与任务进行分类。

展望未来，团队明确了需要持续研究和关注的挑战，例如安全与隐私、个性化与自我进化等。这些领域是进一步研究的重点。

本综述总结了该领域的当前状态，并指出了未来工作的潜在方向，旨在为OS Agents的持续发展贡献力量，并增强其在学术界和工业界的应用价值与实际意义。

如有错误，欢迎大家批评指正，作者也表示，期待各位同行朋友交流讨论！

论文链接：https://github.com/OS-Agent-Survey/OS-Agent-Survey  
项目主页：https://os-agent-survey.github.io/

参考文献：  
[1]Apple Inc. Siri - apple, 2024. https://www.apple.com/siri/  
[2]Microsoft Research. Cortana research - microsoft research, 2024.
https://www.microsoft.com/en-us/research/group/cortana-research/  
[3]Google. Google assistant, 2024. https://assistant.google.com/  
[4]Google. Gemini - google. https://gemini.google.com/  
[5]OpenAI. Home - openai. https://openai.com/  
[6]xAI. x.ai. https://x.ai/  
[7]01.AI. 01.ai. https://www.lingyiwanwu.com/  
[8]Anthropic. Anthropic. https://www.anthropic.com/  
[9]Chatbot arena: An open platform for evaluating llms by human preference,
2024. https://arxiv.org/abs/2403.04132  
[10]Anthropic. 3.5 models and computer use - anthropic, 2024a.
https://www.anthropic.com/news/3-5-models-and-computer-use  
[11]Apple. Apple intelligence, 2024. https://www.apple.com/apple-intelligence/  
[12]Autoglm: Autonomous foundation agents for guis.
https://arxiv.org/abs/2411.00820  
[13]Google DeepMind. Project mariner, 2024.
https://deepmind.google/technologies/project-mariner/  
[14]Anthropic. Claude model - anthropic, 2024b.
https://www.anthropic.com/claude  
[15]Os-atlas: A foundation action model for generalist gui agents.
https://arxiv.org/abs/2410.23218  
[16]Os-copilot: Towards generalist computer agents with self-improvement.
https://arxiv.org/abs/2402.07456  
[17]St-webagentbench: A benchmark for evaluating safety and trustworthiness in
web agents, 2024. http://arxiv.org/abs/2410.06703  
[18]Mobilesafetybench: Evaluating safety of autonomous agents in mobile device
control, 2024. https://arxiv.org/abs/2410.17520^Memory and new controls for
ChatGPT. https://openai.com/index/memory-and-new-controls-for-chatgpt/

— **完** —

  

投稿请发邮件到：

**ai@qbitai.com**

标题注明【投稿】，告诉我们：

你是谁，从哪来，投稿内容‍

附上论文/项目主页链接，以及联系方式哦

我们会（尽量）及时回复你

![](https://mmbiz.qpic.cn/mmbiz_gif/YicUhk5aAGtC5nGy7YMGhQ0ZJeyibWyL0KVCtiaLEPMyd4Bszuo0bFIOxZOvdmqdxnOosYXyu5aI7MXpyUrUWfz6g/640?wx_fmt=gif&tp=webp&wxfrom=5&wx_lazy=1)

  

**点这里 👇关注我，记得标星哦～**

**一键三连「分享」、「点赞」和「在看」**

**科技前沿进展日日相见 ~**

![](https://mmbiz.qpic.cn/mmbiz_svg/g9RQicMD01M0tYoRQT2cMQRmPS5ZDyrrfzeksiay90KaDzlGBH61icqHxmgFKfvfXtVuwTHV740CDLAaXU1LIfZyoJEpYKcRIiaE/640?wx_fmt=svg&tp=webp&wxfrom=5&wx_lazy=1&wx_co=1)

