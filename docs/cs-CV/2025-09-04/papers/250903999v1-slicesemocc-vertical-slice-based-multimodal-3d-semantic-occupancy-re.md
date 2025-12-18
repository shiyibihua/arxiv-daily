---
layout: default
title: SliceSemOcc: Vertical Slice Based Multimodal 3D Semantic Occupancy Representation
---

# SliceSemOcc: Vertical Slice Based Multimodal 3D Semantic Occupancy Representation

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.03999" class="toolbar-btn" target="_blank">📄 arXiv: 2509.03999v1</a>
  <a href="https://arxiv.org/pdf/2509.03999.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.03999v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.03999v1', 'SliceSemOcc: Vertical Slice Based Multimodal 3D Semantic Occupancy Representation')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Han Huang, Han Sun, Ningzhong Liu, Huiyu Zhou, Jiaquan Shen

**分类**: cs.CV

**发布日期**: 2025-09-04

**备注**: 14 pages, accepted by PRCV2025

---

## 💡 一句话要点

**提出SliceSemOcc以解决3D语义占用预测中的高度信息不足问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `3D语义占用预测` `自动驾驶` `多模态融合` `特征提取` `深度学习` `通道注意力` `空间结构建模`

## 📋 核心要点

1. 现有的3D语义占用预测方法大多忽视高度轴信息，导致对空间结构的理解不足。
2. 本文提出的SliceSemOcc框架通过全局和局部垂直切片提取高度特征，并自适应融合细节与上下文信息。
3. 在nuScenes数据集上进行的广泛实验表明，SliceSemOcc显著提升了平均IoU，尤其在小物体类别上效果显著。

## 📝 摘要（中文）

随着自动驾驶对精确3D感知的需求，3D语义占用预测成为关键研究课题。与限制于2D平面的鸟瞰图方法不同，本文提出的SliceSemOcc利用完整的3D体素网格建模空间结构，捕捉垂直轴上的语义变化。现有方法忽视高度轴信息，且传统的通道注意力机制对所有高度层赋予均匀权重，限制了特征强调能力。为此，本文提出了一种基于垂直切片的多模态框架，结合全局和局部切片提取高度轴特征，并通过全局局部融合模块自适应整合细粒度空间细节与整体上下文信息。此外，SEAttention3D模块通过平均池化保持高度分辨率，并为每个高度层分配动态通道注意力权重。实验结果表明，该方法在nuScenes-SurroundOcc和nuScenes-OpenOccupancy数据集上显著提高了平均IoU，尤其在小物体类别上表现突出。

## 🔬 方法详解

**问题定义**：本文旨在解决现有3D语义占用预测方法中对高度信息的忽视，导致空间结构建模能力不足的问题。现有方法通常采用均匀的通道注意力机制，无法有效强调不同高度层的特征。

**核心思路**：SliceSemOcc框架通过引入全局和局部垂直切片，提取高度轴特征，并通过全局局部融合模块自适应整合细粒度空间信息与整体上下文，从而增强对3D场景的理解。

**技术框架**：整体架构包括特征提取模块、全局局部融合模块和SEAttention3D模块。特征提取模块负责从3D体素网格中提取高度特征，融合模块则整合不同层次的信息，而SEAttention3D模块则动态调整通道注意力权重。

**关键创新**：最重要的创新在于引入了SEAttention3D模块，该模块通过平均池化保持高度分辨率，并为每个高度层分配动态权重，显著提高了特征提取的灵活性和准确性。

**关键设计**：在网络结构上，采用了多层卷积和池化操作以提取特征，并设计了特定的损失函数以优化模型性能。通过对比实验验证了各模块的有效性，确保了模型在不同场景下的鲁棒性。

## 📊 实验亮点

在nuScenes-SurroundOcc和nuScenes-OpenOccupancy数据集上的实验结果显示，SliceSemOcc方法显著提高了平均IoU，尤其是在小物体类别上，提升幅度达到XX%。与基线方法相比，本文方法在多个指标上均表现出色，验证了其有效性和优越性。

## 🎯 应用场景

该研究的潜在应用领域包括自动驾驶、机器人导航和智能监控等。通过提升3D语义占用预测的准确性，能够为自动驾驶系统提供更可靠的环境感知，进而提高行车安全性和效率。未来，该技术有望在更广泛的智能交通和城市管理中发挥重要作用。

## 📄 摘要（原文）

> Driven by autonomous driving's demands for precise 3D perception, 3D semantic occupancy prediction has become a pivotal research topic. Unlike bird's-eye-view (BEV) methods, which restrict scene representation to a 2D plane, occupancy prediction leverages a complete 3D voxel grid to model spatial structures in all dimensions, thereby capturing semantic variations along the vertical axis. However, most existing approaches overlook height-axis information when processing voxel features. And conventional SENet-style channel attention assigns uniform weight across all height layers, limiting their ability to emphasize features at different heights. To address these limitations, we propose SliceSemOcc, a novel vertical slice based multimodal framework for 3D semantic occupancy representation. Specifically, we extract voxel features along the height-axis using both global and local vertical slices. Then, a global local fusion module adaptively reconciles fine-grained spatial details with holistic contextual information. Furthermore, we propose the SEAttention3D module, which preserves height-wise resolution through average pooling and assigns dynamic channel attention weights to each height layer. Extensive experiments on nuScenes-SurroundOcc and nuScenes-OpenOccupancy datasets verify that our method significantly enhances mean IoU, achieving especially pronounced gains on most small-object categories. Detailed ablation studies further validate the effectiveness of the proposed SliceSemOcc framework.

