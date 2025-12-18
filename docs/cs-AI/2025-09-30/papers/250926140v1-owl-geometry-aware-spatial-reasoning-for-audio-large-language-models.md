---
layout: default
title: OWL: Geometry-Aware Spatial Reasoning for Audio Large Language Models
---

# OWL: Geometry-Aware Spatial Reasoning for Audio Large Language Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.26140" class="toolbar-btn" target="_blank">📄 arXiv: 2509.26140v1</a>
  <a href="https://arxiv.org/pdf/2509.26140.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.26140v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.26140v1', 'OWL: Geometry-Aware Spatial Reasoning for Audio Large Language Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Subrata Biswas, Mohammad Nur Hossain Khan, Bashima Islam

**分类**: cs.SD, cs.AI

**发布日期**: 2025-09-30

---

## 💡 一句话要点

**提出OWL模型，通过几何感知空间推理提升音频大语言模型对声音方位和距离的感知精度。**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱八：物理动画 (Physics-based Animation)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `音频大语言模型` `空间推理` `几何感知` `双耳音频` `深度学习`

## 📋 核心要点

1. 现有音频大语言模型依赖非结构化双耳线索和单步推理，在方向和距离估计上存在精度和可解释性不足的问题。
2. 提出空间声学几何编码器（SAGE）将双耳声学特征与3D空间结构对齐，并结合空间接地的思维链进行推理。
3. 构建BiDepth数据集用于大规模训练和评估，实验结果表明OWL模型在DoA误差和空间推理QA准确率上均有显著提升。

## 📝 摘要（中文）

空间推理是听觉感知的基本能力，但目前的音频大语言模型（ALLMs）主要依赖于非结构化的双耳线索和单步推理，这限制了方向和距离估计的感知精度和可解释的推理能力。本文提出了空间声学几何编码器（SAGE），它是一种几何感知的音频编码器，在训练时使用全景深度图像和房间脉冲响应将双耳声学特征与3D空间结构对齐，而在推理时只需要音频。在此基础上，提出了OWL，一个ALLM，它将SAGE与空间接地的思维链相结合，以合理化到达方向（DoA）和距离估计。通过从感知QA到多步推理的课程学习，OWL支持时钟级别的方位角和DoA估计。为了实现大规模的训练和评估，构建并发布了BiDepth数据集，该数据集包含超过一百万个QA对，结合了双耳音频与全景深度图像和室内外场景的房间脉冲响应。在BiDepth和公开的SpatialSoundQA两个基准数据集上，OWL通过SAGE将平均DoA误差降低了11度，并将空间推理QA的准确率提高了25%。

## 🔬 方法详解

**问题定义**：现有音频大语言模型在处理空间音频时，主要依赖非结构化的双耳线索，缺乏对场景几何信息的有效利用，导致在声音方位和距离估计方面精度较低，并且推理过程缺乏可解释性。现有方法，如BAT，虽然使用了空间QA，但依赖于粗糙的类别标签，缺乏显式的几何监督，限制了分辨率和鲁棒性。

**核心思路**：本文的核心思路是将音频特征与3D空间几何信息进行对齐，从而使模型能够更好地理解声音的空间关系。通过引入全景深度图像和房间脉冲响应作为辅助信息，训练一个几何感知的音频编码器，使模型能够学习到声音在空间中的位置和传播特性。在推理阶段，即使没有深度图像，模型也能利用学到的空间知识进行更准确的方位和距离估计。

**技术框架**：OWL模型的整体框架包括以下几个主要模块：1) **空间声学几何编码器 (SAGE)**：将双耳音频特征与3D空间结构对齐。2) **空间接地的思维链**：用于进行多步推理，从DoA和距离估计中进行合理化推导。3) **音频大语言模型 (ALLM)**：将SAGE的输出与文本信息结合，进行空间推理QA。训练过程采用课程学习策略，从简单的感知QA任务逐渐过渡到复杂的多步推理任务。

**关键创新**：本文最重要的技术创新点在于SAGE，它是一种几何感知的音频编码器，能够将双耳音频特征与3D空间结构进行对齐。与现有方法相比，SAGE利用全景深度图像和房间脉冲响应作为几何监督信号，使模型能够学习到更丰富的空间信息。此外，OWL模型还引入了空间接地的思维链，使模型能够进行更可解释的空间推理。

**关键设计**：SAGE的关键设计包括：1) 使用卷积神经网络提取双耳音频特征。2) 使用全景深度图像和房间脉冲响应作为几何监督信号，训练模型学习空间信息。3) 设计损失函数，鼓励模型将音频特征与对应的空间位置进行对齐。OWL的关键设计包括：1) 使用Transformer架构构建ALLM。2) 引入空间接地的思维链，进行多步推理。3) 采用课程学习策略，逐步提升模型的推理能力。

## 📊 实验亮点

实验结果表明，OWL模型在BiDepth和SpatialSoundQA两个基准数据集上均取得了显著的性能提升。具体来说，通过SAGE，OWL模型将平均DoA误差降低了11度，并将空间推理QA的准确率提高了25%。这些结果表明，本文提出的几何感知空间推理方法能够有效地提升音频大语言模型对声音方位和距离的感知精度。

## 🎯 应用场景

该研究成果可应用于智能家居、机器人导航、虚拟现实和增强现实等领域。例如，在智能家居中，模型可以根据声音判断事件发生的方位和距离，从而实现更智能的控制。在机器人导航中，模型可以帮助机器人理解周围环境的声音信息，从而更好地进行定位和避障。在VR/AR中，可以提供更真实的空间音频体验。

## 📄 摘要（原文）

> Spatial reasoning is fundamental to auditory perception, yet current audio large language models (ALLMs) largely rely on unstructured binaural cues and single step inference. This limits both perceptual accuracy in direction and distance estimation and the capacity for interpretable reasoning. Recent work such as BAT demonstrates spatial QA with binaural audio, but its reliance on coarse categorical labels (left, right, up, down) and the absence of explicit geometric supervision constrain resolution and robustness. We introduce the $\textbf{Spatial-Acoustic Geometry Encoder (SAGE}$), a geometry-aware audio encoder that aligns binaural acoustic features with 3D spatial structure using panoramic depth images and room-impulse responses at training time, while requiring only audio at inference. Building on this representation, we present $\textbf{OWL}$, an ALLM that integrates $\textbf{SAGE}$ with a spatially grounded chain-of-thought to rationalize over direction-of-arrivals (DoA) and distance estimates. Through curriculum learning from perceptual QA to multi-step reasoning, $\textbf{OWL}$ supports o'clock-level azimuth and DoA estimation. To enable large-scale training and evaluation, we construct and release $\textbf{BiDepth}$, a dataset of over one million QA pairs combining binaural audio with panoramic depth images and room impulse responses across both in-room and out-of-room scenarios. Across two benchmark datasets, our new $\textbf{BiDepth}$ and the public SpatialSoundQA, $\textbf{OWL}$ reduces mean DoA error by $\textbf{11$^{\circ}$}$ through $\textbf{SAGE}$ and improves spatial reasoning QA accuracy by up to $\textbf{25}$\% over BAT.

