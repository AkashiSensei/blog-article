从 RDMA 资源消失到 CSI 挂载失败：平台组件的污点与容忍

趁十一假期整理一些积压的问题。

先介绍一下背景。Crater 是我们开发的一个开源 AI 集群管理平台，基于 Kubernetes，主要方便用户使用集群中的 GPU 等计算资源来跑训练、推理，或者启动 Jupyter 等开发环境。

集群由多个账户共享，但有时也需要把整台计算节点留给某个账户独占使用。我们通过给节点添加 `crater.raids.io/account=<账户名>:NoSchedule` 污点来实现这个调度限制，再给对应账户的作业添加容忍，允许它们调度过去。但是，这些节点也需要运行驱动、网络和存储插件等 Pod，如果它们被污点拦截，就可能会导致故障。

下面以两个问题为引子简单进行说明和复盘，其他的类似问题就不再赘述。

# 问题现象

## RDMA 资源发现问题

RDMA 用于机器之间高速、低延迟地传输数据，常见于需要频繁交换梯度的多机训练场景。

集群的一次节点的内核升级后，不需要 RDMA 的作业仍然能够运行，但 RDMA 作业无法调度到本应支持 RDMA 的节点上。

## CSI 存储挂载问题

我们集群中 Crater 的前后端以及存储服务通过 Helm 安装和更新，某次更新镜像版本后，新的存储服务（storage-server）Pod 无法正常启动，但此前创建的旧 Pod 仍然能够运行并支持文件访问。

# 问题排查与分析

先说明一下污点和容忍的关系：节点有 `NoSchedule` 污点时，没有对应容忍的 Pod 就不能调度过去。在 Pod 的 `spec.tolerations` 中添加匹配的容忍，只是允许它过去，不会被污点拦下，节点选择、亲和性和资源数量等条件仍然要满足。另外，`NoSchedule` 不会直接驱逐已经运行的 Pod，详见 [Kubernetes 文档](https://kubernetes.io/docs/concepts/scheduling-eviction/taint-and-toleration/)。

## RDMA 资源发现问题

排查时发现，宿主机上的网卡和驱动正常，但 Kubernetes 中的 RDMA 资源为 0。下面是当时 `dell-gpu-06` 节点的输出，只保留相关字段。

```text
feature.node.kubernetes.io/kernel-version.full=5.15.0-170-generic
network.nvidia.com/operator.mofed.wait=true
Taints:             crater.raids.io/account=q-48:NoSchedule
Unschedulable:      false
Capacity:
  rdma/rdma_a100:     0
  rdma/rdma_v100:     0
Allocatable:
  rdma/rdma_a100:     0
  rdma/rdma_v100:     0
```

宿主机上的 RDMA 已经能用，但 Kubernetes 还需要设备插件把资源报上来，调度器才能知道这个节点有多少 RDMA 资源可用。

在这套部署中，[OFED](https://www.openfabrics.org/ofed-for-linux/)（OpenFabrics Enterprise Distribution，OpenFabrics 企业发行版）驱动组件负责安装和加载宿主机上的 RDMA 网卡驱动，使宿主机能够使用网卡的 RDMA 功能；RDMA shared device plugin 则是 Kubernetes 的设备插件，负责发现 RDMA 设备并上报可供 Pod 申请的资源，让多个 Pod 可以共享 RDMA 设备，详见[设备插件说明](https://github.com/Mellanox/k8s-rdma-shared-dev-plugin)。

这两种组件通过各自的 DaemonSet 部署，由 Kubernetes 的 DaemonSet 控制器为符合条件的节点创建对应的 OFED 驱动 Pod 和 RDMA 设备插件 Pod。当时检查的两个 DaemonSet 都显示 **34/34 可用**，但这个节点上既没有 OFED 驱动 Pod，也没有 RDMA 设备插件 Pod。

下面分别摘取两个 DaemonSet 的 describe 输出，省略无关字段；两者的 Pod 模板都只配置了 GPU 污点容忍。

```text
Name:           rdma-shared-dp-ds
Desired Number of Nodes Scheduled: 34
Number of Nodes Scheduled with Available Pods: 34
  Tolerations:          nvidia.com/gpu:NoSchedule op=Exists

Name:           mofed-ubuntu22.04-76944977f-ds
Desired Number of Nodes Scheduled: 34
Number of Nodes Scheduled with Available Pods: 34
  Tolerations:          nvidia.com/gpu:NoSchedule op=Exists
```

这里容易被这个数字误导：34/34 只说明 DaemonSet 认为应该部署的 34 个 Pod 都正常，并不说明所有需要 RDMA 的节点都已经有插件。被污点等条件排除的节点，可能根本没有算进这个数字里。

我们集群的 RDMA 配置参考了师兄的[文章](https://zhuanlan.zhihu.com/p/1897271506645530541)，采用 NVIDIA Network Operator 管理 OFED 驱动和 RDMA shared device plugin。Operator 按一份集群级自定义资源 `NicClusterPolicy` 来部署这些组件，其中写明要启用的驱动、设备插件以及 Pod 的容忍等配置。要理解资源如何从网卡变成调度器可用的信息，需要先区分节点上的组件、集群级控制器和 Kubernetes 控制平面。

| 组件 | 运行位置 | 在这条链路中的工作 |
| --- | --- | --- |
| Node Feature Discovery（NFD）worker | 各节点上的 Pod，通常通过 DaemonSet 部署 | 检测本机网卡、系统和内核信息，并通过 API Server 写入 `NodeFeature` |
| NFD master | 集群级控制器 Pod，通过 Deployment 部署 | 监听 `NodeFeature`，通过 API Server 更新 Node 对象的标签 |
| Network Operator | 集群级控制器 Pod，通过 Deployment 部署 | 读取节点标签和 NicClusterPolicy，分别管理 OFED 驱动 DaemonSet 和 RDMA 设备插件 DaemonSet |
| DaemonSet 控制器 | Kubernetes 控制平面 | 根据各 DaemonSet 的 Pod 模板，为符合条件的节点创建对应 Pod |
| 调度器 | 集群级组件；默认 kube-scheduler 属于控制平面，也可以使用独立部署的作业调度器 | 检查节点条件和资源，把 Pod 绑定到目标节点 |
| OFED 驱动 | 目标 RDMA 节点上的 Pod，通过 OFED 驱动 DaemonSet 部署 | 安装和加载宿主机上的 RDMA 网卡驱动 |
| RDMA shared device plugin | 目标 RDMA 节点上的 Pod，通过 RDMA 设备插件 DaemonSet 部署 | 发现本机 RDMA 设备，向本机 kubelet 注册并报告设备资源 |
| kubelet | 每个节点上的宿主机进程 | 管理本机 Pod、检查就绪状态、调用设备插件并上报节点资源 |
| containerd 等容器运行时 | 每个节点上的宿主机进程 | 按 kubelet 提供的配置创建和运行容器 |
| API Server | Kubernetes 控制平面 | 提供 Node、Pod、DaemonSet 等对象的读写与监听接口 |

NFD master 和 Network Operator 管理的是整个集群，但它们本身仍是运行在某个节点上的 Pod，不要求物理上位于控制平面节点；实际位置由部署时的节点选择和容忍配置决定。组件之间的信息和控制流程如下，跨组件的 Kubernetes 对象读写都经过 API Server。

1. 节点上的 NFD worker Pod 检测本机网卡、操作系统和内核信息，并通过 API Server 写入一份 `NodeFeature` 对象。NFD master 监听这些对象，再通过 API Server 更新对应 Node 对象的标签；这些标签属于集群里的 Node 记录。此时集群知道的是节点特征，RDMA 可分配资源还需要设备插件另外上报。
2. Network Operator 读取 Node 标签和 `NicClusterPolicy`，分别创建、维护 OFED 驱动 DaemonSet 和 RDMA 设备插件 DaemonSet。在本文核对的 25.1.0 版本中，Network Operator 按操作系统名称、系统版本和完整内核版本给节点分组，每组对应一个 OFED 驱动 DaemonSet，在该组符合条件的节点上各部署一个 OFED 驱动 Pod。内核升级、NFD 更新标签后，节点可能匹配已有的 OFED 驱动 DaemonSet，也可能需要 Network Operator 为新内核创建对应的 OFED 驱动 DaemonSet。
3. DaemonSet 控制器根据 OFED 驱动 DaemonSet 的 Pod 模板，检查节点选择和污点容忍等条件，为符合条件的节点创建 OFED 驱动 Pod。调度器完成节点绑定后，目标节点上的 kubelet 调用容器运行时启动 OFED 驱动容器，由驱动容器准备宿主机驱动、加载内核模块；kubelet 检查驱动容器是否就绪，并通过 API Server 上报 OFED 驱动 Pod 的状态。
4. Network Operator 读取 OFED 驱动 Pod 中驱动容器的 Ready 状态，确认就绪后，通过 API Server 将该 Pod 所在节点的 `network.nvidia.com/operator.mofed.wait` 标签改为 `false`，表示无需继续等待 OFED 驱动就绪。
5. RDMA 设备插件 DaemonSet 的 Pod 模板要求节点具有对应网卡标签，且等待标签为 `false`。DaemonSet 控制器通过 API Server 监听 Node 变化，收到等待标签更新后，重新检查 RDMA 设备插件的节点选择和污点容忍条件；条件满足且节点缺少对应插件 Pod 时，就创建 RDMA 设备插件 Pod。调度器完成节点绑定后，该节点上的 kubelet 调用容器运行时，先启动插件 Pod 的 init container 检查本机 `mlx5_core` 模块，检查通过后再启动 RDMA 设备插件容器。
6. RDMA 设备插件发现符合配置的本机设备，通过本机 socket 向 kubelet 注册资源名称和插件接口，再通过 `ListAndWatch` 持续报告资源列表与健康状态。RDMA 设备插件与 kubelet 在同一节点上通信，由 kubelet 负责向集群上报资源。
7. kubelet 通过 API Server 更新对应 Node 的 `status.capacity` 和 `status.allocatable`，此时 `kubectl describe node` 才能看到 RDMA 资源。前者表示资源总量，后者表示可供 Pod 分配的量；调度器还需扣除已有 Pod 的资源申请，才能判断剩余资源。共享插件上报的资源单位由配置决定，并不直接等于物理网卡数量。
8. 作业调度器读取 Node 的 RDMA 资源状态，结合 RDMA 作业 Pod 的资源申请、节点选择和污点容忍，将作业 Pod 绑定到目标节点。该节点上的 kubelet 再调用本机 RDMA 设备插件的 `Allocate` 接口取得设备访问配置，并交给容器运行时启动作业容器。

其中，驱动就绪到插件部署的衔接可以参考 Network Operator 的[等待标签实现](https://github.com/Mellanox/network-operator/blob/v25.1.0/controllers/nicclusterpolicy_controller.go#L185)和 [RDMA 设备插件模板](https://github.com/Mellanox/network-operator/blob/v25.1.0/manifests/state-rdma-shared-device-plugin/0060_rdma-shared-dev-plugin-ds.yaml)，资源注册与分配机制见 Kubernetes 的 [Device Plugin 文档](https://kubernetes.io/docs/concepts/extend-kubernetes/compute-storage-net/device-plugins/)。

上述流程中，RDMA 设备插件 DaemonSet 的关键节点选择条件如下，位于 `spec.template.spec.nodeSelector`。

```yaml
nodeSelector:
  feature.node.kubernetes.io/pci-15b3.present: "true"
  network.nvidia.com/operator.mofed.wait: "false"
```

问题就出在这里：目标节点有账户独占污点 `crater.raids.io/account=q-48:NoSchedule`，但 OFED 驱动和 RDMA 设备插件的 DaemonSet 模板都只有 `nvidia.com/gpu:NoSchedule` 的容忍，没有账户污点的容忍。OFED 驱动 Pod 无法部署到目标节点，现场的等待标签仍为 `true`，RDMA 设备插件 DaemonSet 又要求该标签为 `false`，因此目标节点也没有 RDMA 设备插件 Pod，RDMA 资源自然报不上去。即使等待标签变为 `false`，RDMA 设备插件 Pod 仍需要匹配账户污点的容忍才能部署。

需要注意，DaemonSet 并不是所有节点都能去。Kubernetes 会给它的 Pod 自动加上一些系统容忍，比如 `node.kubernetes.io/unschedulable`，但不会自动容忍我们加的账户污点。这里节点的 `Unschedulable` 本来就是 `false`，也不能把原因归到节点被 cordon 上，详见 [DaemonSet 文档](https://kubernetes.io/docs/concepts/workloads/controllers/daemonset/#taints-and-tolerations)。

当时的笔记还记录了宿主机通过 DKMS 在新内核下重建驱动。这可以解释为什么宿主机上的 RDMA 已经恢复，但它不会替代 Network Operator 对 OFED 驱动 Pod 的就绪判断，更不会替 RDMA 设备插件上报资源。保留下来的输出没有记录完整的标签变化过程，我们能确认的是当时等待标签为 `true`，不能据此认为任何内核升级都会立即把等待标签改成 `true`。

## CSI 存储挂载问题

另一个问题发生在使用 Ceph 作为存储后端的 Crater 集群中。Ceph 是分布式存储系统，把数据存放在多台机器上，通过副本等机制提供冗余和容错，并支持文件、块和对象存储。[CephFS](https://docs.ceph.com/en/latest/cephfs/) 是 Ceph 提供的共享文件系统，允许多个节点挂载、读写同一套文件，本次 storage-server 使用的就是 CephFS。

将 Ceph 接入 Kubernetes，还涉及 Rook 和 Ceph CSI。Rook 负责部署和管理存储组件；CSI 是 Kubernetes 为存储插件定义的接口，Ceph CSI 实现这套接口，让 Kubernetes 能够创建、挂载和卸载 Ceph 存储卷。在本次部署中，各组件的分工如下。

| 组件 | 作用与部署方式 |
| --- | --- |
| [Rook Operator](https://rook.io/docs/rook/latest/Getting-Started/intro/) | 我们独立应用 YAML 安装，其 Pod 由 Deployment 管理；读取存储配置，管理 Ceph 服务以及 Ceph CSI 的控制器和节点插件 |
| Ceph CSI 控制器 | 由 Rook 创建并维护 Deployment，处理创建存储卷等集群级操作；本次使用其中的 CephFS 驱动 |
| Ceph CSI 节点插件 | 由 Rook 创建并维护 DaemonSet，在需要使用存储的节点上运行；向本机 kubelet 注册驱动，并按 kubelet 请求完成挂载、卸载；本次对应 `csi-cephfsplugin` Pod |
| storage-server | Crater 的文件访问服务，通过 Deployment 部署，使用已经挂载的 CephFS 文件系统，为用户提供文件访问 |

这套部署把 storage-server 安排在三个控制平面节点上，与 Kubernetes 控制面组件共用节点，因此这些节点也需要运行 CephFS CSI 节点插件。

检查 Pod 状态发现，两个 2026 年 3 月 7 日创建的旧 storage-server Pod 仍然是 `Running / Ready`，而 7 月 19 日新建的 Pod 已调度到控制平面节点，却卡在 `ContainerCreating`，事件中记录了以下挂载错误。

```text
MountVolume.MountDevice failed ... driver name
rook-ceph.cephfs.csi.ceph.com not found in the list of registered CSI drivers
```

此时 PVC 已经 `Bound`，VolumeAttachment 也显示 `attached=true`，但 kubelet 在准备挂载卷时失败，容器尚未启动。卷的绑定、附加状态正常，并不能保证目标节点能够完成挂载。

控制平面节点有 `node-role.kubernetes.io/control-plane:NoSchedule` 污点，storage-server 配置了对应容忍，可以调度过去。但 Rook 管理的 CephFS CSI DaemonSet 没有这个容忍，三个节点上都没有 `csi-cephfsplugin` Pod，记录节点存储驱动的 `CSINode` 对象中也没有 CephFS 驱动。

即使 Ceph CSI 控制器侧已经完成存储卷准备、PVC 也已绑定，实际挂载仍然需要目标节点上的 `csi-cephfsplugin` Pod。该 Pod 中的 registrar 容器向本机 kubelet 注册驱动，kubelet 再调用同一 Pod 中的 CephFS CSI 驱动完成挂载。其他节点有 `csi-cephfsplugin` Pod，并不能帮这个节点完成注册，详见 [CSI registrar 文档](https://kubernetes-csi.github.io/docs/node-driver-registrar.html)。

旧 Pod 使用已经建立的 CephFS 内核挂载，后续文件读写由内核客户端完成，无需经过 CSI Pod，因此插件缺失时，已有挂载仍可能继续使用；新建 Pod、迁移 Pod 或节点重启后需要重新挂载，才会暴露这个问题。

再看 CephFS CSI DaemonSet 保存的历史修订（ControllerRevision），还能看到下面的配置变化。

| 时间（Asia/Shanghai） | 变化 |
| --- | --- |
| 2026-03-07 15:45:45 | 修订 16 增加控制平面 NoSchedule 容忍 |
| 2026-03-09 22:11:41 | 修订 17 回到没有该容忍的模板 |
| 2026-07-19 | 新 storage-server Pod 暴露挂载失败 |

历史修订确认了容忍曾被添加又移除，但缺少审计记录，无法确定是 Rook 按旧配置重新生成 DaemonSet，还是人工回滚、重新 apply 旧配置造成的。

# 怎么配置能解决这个问题

这两个问题都需要给依赖的组件 Pod 补上容忍，但应该从哪个入口修改，要看这些 Pod 由谁管理、配置从哪里生成。配置来源可能是 Helm values、自定义资源（CR）或 ConfigMap，不能只根据字段名判断它会影响哪个 Pod。

Kubernetes 实际检查的是 Pod 的 `spec.tolerations`。Deployment、DaemonSet 等对象在 `spec.template.spec.tolerations` 中保存 Pod 模板的容忍，新建 Pod 时会按模板带上这些配置。不同 Pod 之间没有自动继承关系：作业 Pod 的容忍不会传给驱动或存储插件，Operator 自身 Pod 的容忍也不会传给它管理的组件 Pod。

ConfigMap 是 Kubernetes 用来保存键值配置的对象，本身没有污点容忍或调度功能。Operator 读取 CR 或 ConfigMap，再把容忍写入组件的 DaemonSet 模板，是 Operator 自己实现的配置传递逻辑；更新 ConfigMap 后是否重新读取、更新哪些对象，也由使用它的组件决定。因此，需要找到组件实际读取的配置入口，并确认修改最终进入了目标 Pod 的容忍配置。

能让组件 Pod 启动的办法不止一种，但还需要考虑修改能维持多久、组件重建或升级后是否仍然有效，以及外部部署者需要承担多少维护工作。

| 方式 | 优点 | 局限 |
| --- | --- | --- |
| 删除节点污点 | 可以迅速解除这一调度限制 | 同时失去账户独占或控制平面节点的调度限制 |
| 直接修改组件 DaemonSet 的容忍 | 修改范围明确，适合应急验证 | 可能被 Operator 覆盖，新内核对应的新 DaemonSet 也不会自动带上这次修改 |
| 在线 patch Operator 读取的 CR 或 ConfigMap | 修改了 Operator 的配置来源，后续调谐能保留并应用容忍 | 只改集群对象，没有同步源文件时，重新部署或配置同步仍可能覆盖它 |
| 修改部署源文件中的 CR、ConfigMap 或相应 Helm values | 配置可复用，重新部署和组件重建时可以继续生成正确的 Pod 模板 | 需要明确实际配置入口，升级组件时核对字段和更新行为 |
| 由 Crater 自动检查或修改第三方组件配置 | 可以减少外部部署者逐个排查、手动修改的工作 | 需要适配不同安装方式和版本；自动修改还可能与管理员的配置管理冲突，并触发驱动或 CSI 更新 |

这里保留节点污点，只给需要覆盖这些节点的组件添加指定 key、指定 effect 的容忍。持久配置可以适应 Pod 重建和 Operator 调谐，但也需要在后续部署中保留；是否让 Crater 接管第三方组件的配置，则要分别考虑。

从开源项目的角度来考虑，对于类似的问题，我们自然是希望能够修改代码或者 Helm 解决，直接避免外部用户遇到它们。但是文中的这两个问题，在我们目前的结构中不太好这样做，因为 RDMA 本身就是需要集群管理员根据集群情况自己配置的，Crater 承担的仅仅是接入而不是配置；Ceph 也不是通过 Helm 随 Crater 一起安装的，本身它也是个可选组件，我们支持不同的存储服务，外部使用 NFS 的可能还居多，所以解决方式可能都看起来比较“手工”。

## RDMA 资源发现问题

要恢复目标节点上的 RDMA 资源，需要让 OFED 驱动 Pod 和 RDMA 设备插件 Pod 都能容忍账户独占污点。我们通过 Helm 部署 Network Operator，但将 `NicClusterPolicy` 单独保存在 YAML 中管理，这两处配置影响的是不同的 Pod。

| 配置入口 | 生效对象 | 传递方式 |
| --- | --- | --- |
| Helm `operator.tolerations` | Network Operator 自身的 Deployment | Helm 渲染 Deployment 的 Pod 模板，供创建 Network Operator Pod 使用 |
| NicClusterPolicy `spec.tolerations` | OFED 驱动、RDMA 设备插件等组件的 DaemonSet | Network Operator 读取 CR，写入各组件的 Pod 模板 |

因此，这次选择在管理员维护的 `NicClusterPolicy` 源 YAML 中添加账户污点容忍，并保留已有条目。RDMA 的资源名称、设备选择等参数本来就在这份配置中，将容忍放在同一入口，也能随 Network Operator 的调谐传到后续匹配新内核的 OFED 驱动 DaemonSet，不需要逐个给生成的 DaemonSet 打补丁。只修改 Helm 的 `operator.tolerations`，只会影响 Network Operator Pod，不会解决 OFED 驱动和 RDMA 设备插件的部署问题。

这里修改的是 `NicClusterPolicy` 资源实例，也就是 CR；CRD 定义这类资源有哪些字段，不是这次需要修改的配置。

应用修改后，Network Operator 读取 `NicClusterPolicy`，更新各个 OFED 驱动 DaemonSet 和 RDMA 设备插件 DaemonSet 的 `spec.template.spec.tolerations`。DaemonSet 控制器重新检查节点条件，为原先被账户污点排除、现在符合条件的节点创建对应组件 Pod。Network Operator 会持续按 CR 配置维护这些 DaemonSet，因此直接修改生成的 DaemonSet 模板，后续可能被覆盖。

还需要区分更新模板和更新已有 Pod。25.1.0 的 OFED 驱动 DaemonSet 使用 `OnDelete` 策略，修改模板不会自动替换旧 OFED 驱动 Pod；已有驱动 Pod 的替换需要另看删除或组件升级逻辑。对于这次原本没有 OFED 驱动 Pod 的目标节点，符合新条件后可以直接补建驱动 Pod，详见 [OFED 更新策略](https://github.com/Mellanox/network-operator/blob/v25.1.0/manifests/state-ofed-driver/0050_ofed-driver-ds.yaml#L23)。

账户污点容忍选择 `crater.raids.io/account` 这个 key，使用 `Exists` 匹配任意账户值，并限定 effect 为 `NoSchedule`。这是因为 OFED 驱动和 RDMA 设备插件需要服务不同账户的独占节点，不适合把账户名写死；如果只允许某个账户，则可以用 `Equal` 配合具体的 value。网卡、内核版本等节点选择条件仍然继续生效。

应急时也可以 patch `NicClusterPolicy` CR，但需要注意：JSON merge patch 会整体替换容忍数组，不能把原来的条目丢掉。

对于外部部署者，我们把配置定位、修改和验证过程整理进了公开的 [RDMA 支持文档](https://raids-lab.github.io/crater/zh/docs/admin/more/rdma/)，其中包含“RDMA 相关工具 Pod 对 Crater 污点的容忍问题”。这样启用账户独占节点时就可以一并准备相关配置，避免在节点升级或驱动重建后才发现遗漏。

## CSI 存储挂载问题

要让新的 storage-server Pod 完成挂载，需要先让三个控制平面节点都运行 CephFS CSI 节点插件。storage-server 已有控制平面污点的容忍，这次缺少容忍的是 `csi-cephfsplugin` Pod，因此修改 storage-server 的配置不会解决问题。

也可以将 storage-server 迁到已有 CephFS CSI 插件的节点，解除这次挂载阻塞，但这会改变服务的部署位置，其他可能运行存储工作负载的节点仍需检查。考虑到这套集群已将 storage-server 部署在控制平面节点，我们选择补齐这些节点上的 CephFS CSI 插件。

这套集群的 Rook v1.17.4 是我们独立安装和维护的基础设施，直接通过 YAML 部署，并未随 Crater Helm Chart 安装。Crater 本身也不捆绑 Ceph，而是通过 StorageClass 或已有 PVC 接入存储，可以使用 CephFS、NFS 等满足共享读写要求的后端。因此，CephFS CSI DaemonSet 的容忍需要在 Rook 实际读取的 `rook-ceph/rook-ceph-operator-config` ConfigMap 中，通过 `CSI_CEPHFS_PLUGIN_TOLERATIONS` 配置，并将修改保存到 Rook 的部署源文件中。

在这套部署中，Rook 会处理该 ConfigMap 的配置变化，读取 `CSI_CEPHFS_PLUGIN_TOLERATIONS` 中的容忍列表，写入 CephFS CSI DaemonSet 的 `spec.template.spec.tolerations`，DaemonSet 控制器再根据新模板创建 `csi-cephfsplugin` Pod。这是 Rook 实现的配置传递过程，CephFS CSI 节点插件不会从 storage-server Pod 或 Rook 自身的 Pod 继承容忍。

这里用 CephFS 插件的专用字段，避免同时改变 RBD 插件的节点覆盖。这个版本会优先使用专用列表，只有没有配置它时才使用通用的 `CSI_PLUGIN_TOLERATIONS`，不会把两个列表自动合并。如果原来有通用容忍，就需要把 CephFS 仍然需要的条目一起写进来，详见 [Rook 配置实现](https://github.com/rook/rook/blob/v1.17.4/pkg/operator/ceph/csi/spec.go#L504)。

这次 CephFS CSI DaemonSet 使用 `RollingUpdate` 策略，模板变化会使 DaemonSet 控制器逐步替换旧插件 Pod，并为新符合条件的控制平面节点创建插件 Pod，再由调度器和目标节点上的 kubelet 完成调度、启动。因此，需要同时确认 ConfigMap、CephFS CSI DaemonSet 模板和实际插件 Pod 中的容忍，以及滚动更新是否完成。直接修改 CephFS CSI DaemonSet 虽然可能暂时有效，但 Rook 后续按 ConfigMap 维护它时可能覆盖修改。

修改容忍可能触发已有节点上的 CSI 插件一起滚动更新，因此应用前需要检查存储健康状态和允许同时不可用的插件 Pod 数量。这次 `maxUnavailable=1`，最多允许一个 Pod 不可用；一个节点因镜像内容缺失而卡住后，后续更新也随之停止，所以配置修改成功后仍需确认整个滚动更新完成。

对于外部部署者，Crater 接入的是已有存储，Rook 或其他 CSI 组件仍由各自的部署配置管理。我们已在公开的[存储架构文档](https://raids-lab.github.io/crater/zh/docs/admin/deployment/storage/)中整理了“CephFS CSI 节点覆盖”的排障与持久配置要求，帮助部署者确认应修改哪个入口。

# 最终解决方案

## RDMA 资源发现问题

我们在 `nic-cluster-policy` 的 `spec.tolerations` 中补上账户污点容忍，保留已有字段和容忍，配置片段如下。

```yaml
spec:
  tolerations:
    - key: crater.raids.io/account
      operator: Exists
      effect: NoSchedule
```

应用配置后，Network Operator 按更新后的 `NicClusterPolicy` 维护 OFED 驱动和 RDMA 设备插件的 DaemonSet。

## CSI 存储挂载问题

我们保留了 storage-server 在控制平面节点上的部署，在 `rook-ceph/rook-ceph-operator-config` ConfigMap 中添加下面的字段，并将修改保存到 Rook 的部署源文件中。合并配置时保留了 CephFS 节点插件仍然需要的其他容忍。

```yaml
data:
  CSI_CEPHFS_PLUGIN_TOLERATIONS: |
    - key: node-role.kubernetes.io/control-plane
      operator: Exists
      effect: NoSchedule
```

修改通过服务端 dry-run 和 diff 检查后，我们于 7 月 20 日将 ConfigMap 应用到集群，随后由 Rook 自动更新 CephFS CSI DaemonSet。

# 验证

修复后，我们以新作业的调度结果和新服务的启动情况作为主要验证依据，并结合节点上的组件状态确认配置已经生效。

## RDMA 资源发现问题

验证时，我们对照了 `NicClusterPolicy`、OFED 驱动和 RDMA 设备插件的 DaemonSet 模板，以及实际 Pod 中的容忍，并通过下面的命令查看 `dell-gpu-06` 节点上的组件和资源状态。

```bash
kubectl describe node dell-gpu-06
kubectl -n nvidia-network-operator get pods -o wide --field-selector spec.nodeName=dell-gpu-06
```

这些查询用于核对目标节点上的 OFED 驱动 Pod 和 RDMA 设备插件 Pod，以及驱动的就绪状态、`network.nvidia.com/operator.mofed.wait` 标签和 Capacity / Allocatable 中的 RDMA 资源，并与实际作业的调度结果对照。

应用 `NicClusterPolicy` 的容忍配置后，启用 RDMA 的作业可以正常调度到对应节点，原先“不启用 RDMA 能调度，启用后反而无法调度”的问题不再出现。这个结果确认了目标节点重新满足 RDMA 作业的调度条件，污点容忍缺失造成的部署与资源发现阻塞已经解除。

## CSI 存储挂载问题

验证时，我们对照了 Rook ConfigMap、CephFS CSI DaemonSet 模板和实际插件 Pod 中的容忍，并查询控制平面节点上的插件 Pod 和驱动注册信息。

```bash
kubectl -n rook-ceph get pods -o wide --field-selector spec.nodeName=<node>
kubectl get csinode <node> -o yaml
```

应用 Rook ConfigMap 后，三个控制平面节点都运行了 CephFS CSI 节点插件，对应的 `CSINode` 中也注册了 `rook-ceph.cephfs.csi.ceph.com`。CephFS CSI DaemonSet 最终完成了 31/31 个 Pod 的更新。

此前卡在 `ContainerCreating` 的新 storage-server Pod 随后自动完成挂载，在控制平面节点上成功启动，我们没有手动删除或重启这些业务 Pod。这次确认的是新 Pod 成功建立了挂载，而不是旧 Pod 继续沿用之前的挂载，因此能够说明新配置已经解决了节点侧的 CSI 缺失问题。

这两个问题给我的提醒是：给作业或平台服务配置容忍时，也要检查它依赖的驱动和插件能不能去同样的节点。旧 Pod 能用，可能只是以前的驱动或挂载还有效；升级、重建之后，新 Pod 能正常启动并使用这些资源，才说明相关配置真的生效了。
