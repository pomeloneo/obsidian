# Q15｜DeepSeek R1：多模态模型中Reasoning的重要性如何？

原文链接：https://time.geekbang.org/column/article/888443

---

[![](https://static001.geekbang.org/resource/image/43/bc/439b214c2cbb1e8f2f15fd71091b76bc.png)](https://static001.geekbang.org/resource/image/43/bc/439b214c2cbb1e8f2f15fd71091b76bc.png)

作者介绍：邵帅，腾讯混元专家研究员

Q：DeepSeek R1 模型很火，多模态模型中 Reasoning 的重要性如何？这其中的 Reasoning 是语言层面的更重要？还是视觉层面的更重要？以及会产生哪些重要应用？

邵帅：我有一个不太成熟的观点：Diffusion 模型的推理过程与 CoT 思维链推理具有高度相似性，两者都是通过逐步生成的方式，从初始相对粗糙的结果出发，经过层层迭代和优化，最终获得更优质的结果。

基于这个观察，我认为类似 CoT 的推理过程不仅适用于纯语言模型，在多模态模型或大一统模型中也同样可行。事实上，如果采用自回归式的建模方法，我们就能充分利用现有语言模型和多模态模型的知识储备与推理能力。目前我们已经在图像和视频生成的前置环节进行实践探索。例如，在生成过程中引入类似语言模型的 planning 机制——先进行布局 layout 或草图生成，再进入具体的生成阶段，这种方法能够有效提升生成内容的逻辑性和连贯性。

[![](https://static001.geekbang.org/resource/image/83/64/833ebd1187590c6d8ff52e9256a69a64.png)](https://static001.geekbang.org/resource/image/83/64/833ebd1187590c6d8ff52e9256a69a64.png)
